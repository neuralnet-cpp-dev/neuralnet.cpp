# BitNet b1.58 2B4T 的结构对齐：SubLN / GQA / Tied Embedding

> **读者**：项目开发者（本仓内部工作文档）。本分册定位见 [`README.md`](README.md)；历史归档在 [`../history.md`](../history/history.md)。

> **状态**：现行（**S1/S2/S3/S4 + P2 全部实施完成**）。
> 已落地：SubLN、GQA、tied embedding（S1–S3）、**FFN 激活 ReLU²**（S4，官方 `hidden_act`）、
> **GQA 的 in-kernel 头映射**（P2，省掉 K/V 的头展开物化）。
> **构建与验收在 `ethan@192.168.1.102`**（Windows + LLVM clang 23 + 真实 GPU
> NVIDIA CMP 40HX）：全量 **ctest 30/30 通过**；本机（软件 Vulkan/llvmpipe）
> 曾把 `expr_gpu_test`/`fused_gpu_test` 的退出段问题误判为回归，故改到 102 上验收。
> 本文是"BitNet 结构"的唯一入口；权重侧（`T1_58` + `BitLinear`）在
> `21-quantized-weights.md`，两者是**两条正交的腿**（§8）。
> **落地分支**：`dev/t1_58`（承接 P1，延续"一步一测试一提交"）。
> **关联**：`21-quantized-weights.md`（权重侧 P1 ✅ / P1.5 待做）、
> `18-roadmap.md` §1.1 立项三问。
> **参考实现**：两个独立来源在本轮**互相印证**——
> `~/codes/Lumina-Engine/llama.cpp-b10991`（`src/models/bitnet.cpp` 的 BITNET arch、
> `ggml/src/ggml-cpu/ops.cpp` 的 GQA 头映射）与官方 `transformers` 的
> `BitNetForCausalLM` 建模代码（`repeat_kv` 的 `kv = h // n_rep`）。

---

## 0. 裁决记录（2026-10-10）

| # | 议题 | 裁决 |
|---|------|------|
| 1 | BitNet 的"新结构"到底是什么 | **不是 BitLinear**（那是层），是 **SubLN**——三值丢信息，必须靠改 block 补偿；量化与架构是**协同设计** |
| 2 | BitNet 做成新模型容器？ | **不**。规格/CLI 层面可作一等公民，实现层面是 **GPT 的变体**（共享 `GPTModel`/`GPTBlock` 代码） |
| 3 | SubLN 的封装位置 | **子层内部**（`AttentionBase` / `FeedForward` 的可选成员），**不是** `GPTBlock` 的第三个 norm |
| 4 | SubLN 是不是新的 `NormType` | **不是**。`NormType` = "哪种归一化"（LayerNorm/RMSNorm/BatchNorm），SubLN 用的就是 RMSNorm；它属于"**挂载位置**"这一轴 |
| 5 | SubLN 的归一化类型 | **跟随模型的 `norm_type`**（2B4T = RMSNorm）；经 `make_norm_layer(width, norm_type)` 构造，零新代码 |
| 6 | GQA 的头映射约定 | **`kv_head = h / (n_head / n_head_kv)`**（块映射）。llama.cpp 的 FA 内核 `ik2 = iq2 / rk2` 与 HF `repeat_kv` 的 `reshape(n_kv*n_rep)` 一致 |
| 7 | GQA 的实现形态 | **显式展开 K/V 头**（`gather_rows` 前向 / `scatter_add_rows` 反向），fold 注意力与 AOT 注册表**零改动**；in-kernel 版留 P2 |
| 8 | Tied embedding 的实现形态 | `GPTModel` 内一个开关（`tie_embeddings`）：head 复用 `token_emb_`，梯度累加进 `grad_token_emb_`（与 `scatter_add_rows` 的嵌入梯度**共存累加**） |
| 9 | CLI 预设 | **不加**。不引入 `--model bitnet`；三个开关先只到库 API + `ModelSpec`（GUI 预设留待以后） |
| 10 | ReLU² 激活 | **已落地（S4）**：`ActivationType::ReLU2 = 2` + 新层 `ReLU2GLU`（门控平方 ReLU：`out = relu²(gate)·up`，与 SwiGLU 同接线、单表达式全融合）；CLI `--activation relu2`。llama.cpp 对 gated squared relu 明确 `GGML_ABORT`（`llama-graph.cpp:2293`）→ 无 llama.cpp 可对拍，验收改为**与宿主解析式对拍** |
| 13 | **GQA 的 in-kernel 头映射（P2）** | **已落地**：新视图种类 `ExprViewKind::HeadGroup`（读取语义同 Linear），头分组比放 `views[].param` —— 它是**运行期形状数据、不进 key**（经既有 push constant vp 槽填充）→ **任意 n_rep 共用一份 AOT shader**；训练路径**完全不展开 K/V**（增量推理路径保持不变，见 §3.2.1） |
| 11 | 范围 | 本轮只做 **GPT**；RAPT（ReLU 线性注意力）**不**挂这三项——它的注意力不是 softmax 注意力，做三值权重可以，但那不叫 BitNet |
| 12 | 序列化 | `ModelSpec` 追加 `subln` / `n_head_kv` / `tie_embeddings` **三个键**，缺键 = 旧语义 → **不升 `MODEL_VERSION`**（与 `weight_quant`、`norm_place` 同款） |

**为什么"BitLinear 不是新结构"**：`make_norm_layer` 一个开关在 LayerNorm/RMSNorm/BatchNorm
之间切，没人因此建了三种模型；层的替换 ≠ 新模型。**为什么"BitNet 仍然是新结构"**：
SubLN 改变了每个 block 的**参数集合**（每层多 2 个 norm 权重）与数据流，这是真实的 block 级差异。

---

## 1. 一句话

2B4T 相对本项目 GPT 的差距只有三项：**SubLN**（结构）、**GQA**（结构）、**tied embedding**（结构）。
三项都是"可选配置"，默认全关 → **既有 GPT/RAPT/MLP/CNN/ViT 路径零改动、零回归**。

**目标**：让本项目**能表达** 2B4T 的 block（结构与数值定义对齐官方实现）。
**非目标**：① 复现官方 PPL（本项目 `d_model` 只有 64–256，规模差 3 个数量级）；
② CLI/GUI 暴露（留给后续轮次）；③ 从 HuggingFace 直接加载 2B4T 权重（需要权重转换器，另立）；
④ KV-cache 增量推理的性能（正确性对齐即可）。

---

## 2. 依据：2B4T 的结构拆解

### 2.1 与"标准 LLaMA 式解码器"的差异

2B4T 的拓扑就是 decoder-only Transformer（pre-norm RMSNorm、RoPE、GQA、gated FFN、
embedding 与 head **权重绑定**），"1.58-bit"只作用在**权重取值**上。差异共五处：

| # | 差异 | 性质 | 本项目现状 |
|---|---|---|---|
| 1 | Q/K/V/O + FFN gate/up/down **7 个投影**三值（absmean 尺度 + STE） | 权重表示 | ✅ P1 的 `BitLinear`（**接线到 GPT 属 P1.5**） |
| 2 | **SubLN**：attention 输出后（宽 `d_model`）、FFN 中间激活后（宽 `d_ff`）各一个 RMSNorm | **结构** | ❌ 本文 |
| 3 | **GQA**：20 query heads / 5 KV heads | **结构** | ❌ 本文 |
| 4 | **tied embedding**：head 复用 `tok_embd`（GGUF 张量表里没有 `OUTPUT`） | **结构** | ❌ 本文 |
| 5 | 投影无 bias；FFN 激活（口径待确认为 ReLU²） | 数值 | ⚠️ §9 待定 |

### 2.2 证据（两个独立来源互证）

| 证据 | 位置 | 说明 |
|---|---|---|
| BITNET arch 张量表 | `gguf-py/gguf/constants.py:4075` | `TOKEN_EMBD, OUTPUT_NORM, ATTN_NORM, ATTN_{Q,K,V,OUT}, FFN_NORM, FFN_{GATE,DOWN,UP}, ATTN_SUB_NORM, FFN_SUB_NORM`——**无 `OUTPUT`**（= tied head）、**恰有 2 个 sub-norm** |
| BITNET 图构造 | `src/models/bitnet.cpp:47-157` | 图 = llama 图逐行照抄 + 两次 `build_norm`：attention 输出之后、`wo` 之前；FFN 中间之后、`ffn_down` 之前 |
| SubLN 张点名 | `gguf-py/gguf/tensor_mapping.py:1168,1172` | `self_attn.inner_attn_ln` / `mlp.ffn_layernorm`（HF 原名） |
| 三值化范围 | `conversion/bitnet.py:34-49` | "BitNet 化" = 对一个**张点名集合**做 `weight_quant`（Q/K/V/O + gate/up/down），架构本身不动 |
| GQA 头映射 | `ggml/src/ggml-cpu/ops.cpp:8766-8768` | `rk2 = neq2/nek2`；`ik2 = iq2 / rk2` → `kv = h / (n_head/n_head_kv)` |
| GQA 头映射（HF） | `repeat_kv` | `expand(n_kv, n_rep).reshape(n_kv*n_rep)` → `kv = h // n_rep`。**与上式同一约定** |

---

## 3. 三项设计

### 3.1 SubLN = 子层的可选 Norm（**不是** `NormType` 新值）

**挂载点**（由张量形状反推，唯一可能的位置）：

| SubLN | 输入 | 宽度 | 插入点（代码坐标） |
|---|---|---|---|
| `attn_sub_norm` | attention 输出（softmax 之后、输出投影之前） | `d_model` | `compute_layer_attention.hpp` 的 `return w_o_.forward(concat);` **之前** |
| `ffn_sub_norm` | FFN 中间激活（gate×激活之后、down 之前） | `d_ff` | `compute_layer_feedforward.hpp` 的 `return fc2_.forward(*h2);` **之前** |

**为什么不能挂到 `GPTBlock`**：`norm1_/norm2_` 是 block 级兄弟节点，它们的输入输出都是
`(d_model, batch*seq)`；而 SubLN 的输入在**子层内部**（attention 输出 / FFN 中间），
宽度也不同（`d_model` / `d_ff`）。block 看不到这两个张量。

**为什么不能进 `NormType`**：`NormType` 的语义是"**哪种**归一化"（LayerNorm/RMSNorm/BatchNorm）。
SubLN 用的就是 RMSNorm —— 它是**挂载位置**的不同，不是归一化算子的不同。

**实现形态**（照抄仓库自己的先例）：

- `FeedForward` 已经持有可选子层 `GeLU gelu_` / `SwiGLU swiglu_`（`use_swiglu_` 开关）；
  `AttentionBase` 已经持有可选策略 `pos_` / `mask_`。SubLN 就是再加一个
  `std::unique_ptr<Layer> *_sub_norm_`（默认 `nullptr` = 关）。
- 类型走 `make_norm_layer(width, norm_type)`，与 `norm1_/norm2_/ln_f_` **同一个工厂、同一个类型来源**。
- 需要挂进 7 处既有的 `override`：`init_impl` / `parameters` / `param_gradients` /
  `set_precision_profile` / `set_checkpoint_mode` / `clear_cache` / `activation_cache`
  （漏一处 = 该路径静默失效，这正是 `21` §4.3.1 登记过的缺陷类）。

**参数顺序**：追加在子层既有参数**之后**（attention：`w_q,w_k,w_v,w_o,attn_sub_norm`；
FFN：`fc1,fc2,ffn_sub_norm`）。关闭时该分量贡献 0 个参数 → 布局与旧模型逐位一致。

### 3.2 GQA（分组查询注意力）

**形状约定**：`d_k = d_model / num_heads`（**Q/K/V 同宽**，与 llama.cpp 的
`n_embd_head_q == n_embd_head_k == n_embd_head_v` 一致）。

```
w_q_: (d_model,          d_model)     → Q: (d_model, batch*seq)
w_k_: (n_head_kv * d_k,  d_model)     → K: (n_head_kv*d_k, batch*seq)
w_v_: (n_head_kv * d_k,  d_model)     → V: 同上
w_o_: (d_model,          d_model)
```

**头映射**（§0 第 6 条）：query head `h` 使用 KV head `h / (num_heads / n_head_kv)`（块映射）。
`n_head_kv == num_heads` 时退化为 MHA（`n_rep == 1`，映射恒等）——**这是测试的不变量**。

**实现：显式展开 K/V 头**

```
forward:  K_kv (n_kv*d_k, N) → gather_rows(expand_idx) → K (n_head*d_k, N) → [既有流程]
backward: grad_K (n_head*d_k, N) → scatter_add_rows(expand_idx) → grad_K_kv → w_k_.backward
```

`expand_idx` 是长度为 `n_head*d_k` 的宿主常量向量（`src_row = (h / n_rep) * d_k + r`），
经 `detail::upload_span` 上桥（铁律 #12 允许的"层自算辅助数据"：索引表），在 `init_impl`
构建一次、常驻。**反向复用同一张表**——重复的两行在 `scatter_add_rows` 里自然累加，正好是
"多个 query 头共享一个 KV 头"的梯度语义。

**为什么选展开而不是改 fold**：`dsl::make_fold_attn_o` 与它的 AOT 注册表是**注册表契约**
（`AGENTS.md` §7）——让 fold body 感知 `n_kv` 等于新增结构 + 新增注册，且 CPU/GPU 两侧同步。
展开方案让 fold 与注册表**零改动**，代价是 `n_rep` 倍的 K/V 物化（本项目规模可忽略；
in-kernel 版作为 P2 优化项记录）。

**KV-cache 路径**：`forward_step` 里同样展开（`k_new`/`v_new` 投影后 `gather_rows`），
**cache 布局不变**（仍 `(max_len, n_head*d_k)`）→ 增量推理代码零改动。

#### 3.2.1 P2：把头映射做进 kernel（训练路径完全不展开）

S2 的展开方案有实打实的代价：`n_rep` 倍物化（两个全尺寸缓冲）+ 两次全尺寸 gather +
反向两次额外分配，且 `K_cache_/V_cache_` 要跨 backward 驻留全尺寸。P2 去掉它：

- **新视图种类 `ExprViewKind::HeadGroup`**：读取语义与 `Linear` **完全相同**（恒等索引），
  区别只在 `param` = **头分组比 n_rep**。行块号写成 `base / ratio`。
- **为什么是"视图参数"而不是"算子结构字段"**：`views[].param` 被
  `expr_view_has_runtime_param` 判定为**运行期形状数据** → 不进 `expr_spec_key`、
  经既有 push constant `vp` 槽填充。若做成 `MatmulSpec` 的字段并进 key，
  **每个 n_rep 各要一份 shader**，注册表对未登记的 n_rep 必然 miss（走 JIT 兜底）。
- **单一真源** `nn::gqa_ratio_of(spec, view_idx)`：GPU 生成器与 CPU 参考都从这里取，
  避免两侧口径漂移。
- 覆盖三处：fold 的 mm 段 A/B 两侧、fold 的 vecacc（`V_t`）、独立 bmm 的 A/B 两侧
  （`masked_scores` 的 K、`grad_A` 的 V、`grad_Q` 的 K）。
- **CPU**：`MatmulRef::prepare_cpu`（预绑定走通用 `batched_matmul`、无头映射语义）在
  ratio>1 时直接拒绝 → 上层回退解释器（`eval_expr` 的 MatmulSpec/vecacc 分支已支持）。
  "预绑定只是优化，回退不引入正确性风险"是既有契约。
- **训练 vs 推理**：`AttentionBase::forward`（训练）不展开；`forward_step`（增量推理）
  仍展开 —— KV cache 布局恒 `(max_len, H·d_k)`，增量推理代码零改动。
- **效应**：注意力的 K/V 工作集从 ~3×（Q+K_full+V_full）降到 ~1.5×（Q+K/V 各 1/n_rep），
  省掉 2 个全尺寸缓冲 + 2 次全尺寸 gather；`K_cache_/V_cache_` 的跨 backward 驻留缩到 1/n_rep。

### 3.3 Tied embedding

关闭时（默认）：`lm_head_` 是独立 `Linear(d_model, vocab_size)` —— 布局与今天逐位一致。

开启时：head 复用 `token_emb_ (vocab_size, d_model)`：

```
logits = W_emb · x            (W: (V,D), x: (D,N) → (V,N))
dX     = W_embᵀ · grad_logits  (matmul(W, g, transA=true))
dW_emb += grad_logits · xᵀ     (matmul(g, x, transB=true)) → 累加进 grad_token_emb_
```

**关键点：梯度要累加、不能覆盖。** `token_emb_` 同时承担两个角色（输入嵌入的查表 + 输出投影的权重），
所以它的梯度 = 嵌入侧 `scatter_add_rows` 的结果 **+** head 侧的 `dW_emb`。两者都写
`grad_token_emb_`，优化器 `zero_grad()` 只在 step 开头清一次 —— 顺序无关，语义正确。

**`head_prof.compute = stable` 的特例必须保留**（`21` §9.2 的 OOM 结论：logits 是最大张量、
被 loss 链多次读取，head 留在 compute 精度会物化多份 f32 副本）。

---

### 3.4 权重侧接入（P1.5 落地，2026-10-10）：三值线性层落点

结构三项是"图长什么样"，权重侧（`21` §4.8.3 的 P1.5）是"线性层用哪种实现"。落地后
**同一个 `PrecisionProfile` 就能点亮整条 2B4T 形态**（权重三值 + 四个结构开关）：

| 落点 | 改法 | 三值（`weight_quant=T1_58`）时变成 |
|---|---|---|
| `AttentionBase`（`CausalSelfAttention` 继承） | `Linear w_q_/w_k_/w_v_/w_o_` → `std::unique_ptr<Layer>` | `BitLinear` × 4（GQA 只改 K/V 的**输出**宽度，与三值正交） |
| `FeedForward` | `Linear fc1_/fc2_` → `std::unique_ptr<Layer>` | `BitLinear` × 2（`fc1_` 宽度随 GeLU/SwiGLU/ReLU² 变化，与三值正交） |
| `GPTModel` | `Linear lm_head_` → `std::unique_ptr<Layer>` | `BitLinear`（`tie_embeddings=true` 时 head 就是嵌入，无线性层） |
| 自定义层 / 下游工程 | 同一条 `make_linear_layer(in, out, weight_quant)` | 与 `make_norm_layer` 同一个先例 |

**判据唯一 + 构造期定型**：`effective_weight_quant(precision, weight_quant)` ——
`precision.param == T1_58`（CLI `--precision-param t1_58` / `ModelSpec.weight_quant` /
库 API）等价于 `weight_quant = T1_58`；开关是**构造参数**（默认 `None`），所以既有
f16/f32 路径的成员构造与求值结构逐位不变（`split_ternary_profile` 在非三值时恒等）。

**profile 分流**：`param=T1_58` 只对**线性子层**有意义，因此复合层把一次 profile 拆两份
（`sp.self` = param 归一化为 f32，给自身/norm/激活/softmax/位置编码；`sp.linear` = param=T1_58，
给 BitLinear）。**未以三值模式构造却收到 T1_58 → fail-fast**，不静默降级 f32。
落地细节与验收数字见 `21` §4.10。

**边界（诚实）**：RAPT 的 `ReLULinearAttention` 与 ViT/MNIST Transformer 的补丁/池化侧
**仍未接线**，两者现在都明确拒绝（`--arch rapt --precision-param t1_58` 前置报错；
ViT 在 `PatchEmbedding` 的能力校验处报错），而不是"跑了一半三值"。

---

## 4. 规格与序列化

`ModelSpec` 追加三个字段（`model_spec.hpp` 的 GPT 段）：

| 字段 | 类型 | 缺键默认 | 语义 |
|---|---|---|---|
| `subln` | `bool` | `false` | 每个 block 的 attention/FFN 子层内部各加一个 norm |
| `n_head_kv` | `std::size_t` | `0` | `0` = 与 `num_heads` 相同（= MHA，旧语义） |
| `tie_embeddings` | `bool` | `false` | head 复用 token embedding |

三处同步（`weight_quant` 的同一套流程）：

1. `spec_to_kv` 写入；2. `spec_from_kv` 读取（缺键 → 保持默认）；3. `spec_matches` 的
GPT 家族分支**逐字段比对**（漏比 = 允许把不匹配的权重加载进模型）。

**不升 `MODEL_VERSION`**：三个键都是纯追加，缺键回落到的默认值 = 今天的参数布局。
`spec_summary` 在非默认时显式披露（诊断用）。

---

## 5. 分期与验收

每步 = **实现 + 测试 + 提交**（沿用仓库纪律：`ctest` 全绿 + `L2-VIOLATIONS: 0`
+ 既有路径零回归）。

| 步骤 | 内容 | 验收（全部在 102 实测） |
|---|---|---|
| **S1 ✅** SubLN | `AttentionBase`/`FeedForward` 加可选 sub-norm（§3.1）；`GPTBlock`/`GPTModel`/`GptConfig` 透传；`ModelSpec.subln` | ① 参数增量 = `layers×(d_model+d_ff)`（RMSNorm；实测 288 = 3×(32+64)）；LayerNorm 翻倍 576 ✅；② 子层 norm 参数梯度非零 ✅；③ 同权重消融 on≠off（最大差 0.388）✅；④ 规格往返逐位一致 ✅；⑤ 端到端 loss 592→3e-6 ✅；⑥ ctest 30/30 ✅ |
| **S2 ✅** GQA | `AttentionBase` 加 `n_head_kv_` + 展开表（§3.2）；`CausalSelfAttention`/`GPTBlock`/`GPTModel`/`GptConfig` 透传；`ModelSpec.n_head_kv` | ① `n_head_kv == num_heads` 与 MHA 前向/输入梯度**逐位相同**（差 = 0）✅；② 与"把 K/V 权重按块映射复制成 MHA"对拍：前向差 **0**、输入梯度 1.19e-7、K/V 权重梯度 = 组内和 ✅（该用例**钉住块映射约定**）；③ 规格往返逐位一致 ✅；④ ctest 30/30 ✅ |
| **S4 ✅** ReLU² | 官方 `hidden_act="relu2"`：`ActivationType::ReLU2 = 2` + 新层 `ReLU2GLU`（门控平方 ReLU）；CLI/GUI 同步；`scan_exprs` 模型 pass 补 `gpt_rope_relu2_rms` | ① `ReLU2GLU` 前向 vs 宿主 `relu²(gate)·up` 差 **0**、反向 vs 解析式 4.47e-8 ✅；② ReLU² 进 GPT（叠加 subln+GQA+tied）前向/反向跑通 ✅；③ 全量 ctest 30/30 ✅ |
| **P2 ✅** GQA in-kernel | K/V 不展开（`HeadGroup` 视图 + 运行期 vp 比率）；fold/bmm/vecacc 三处行块号按比率取；`scan_exprs` 显式登记 attention fold 的 GQA 变体 | ① **测试与登记故意用不同配置**（heads=4/n_kv=2 vs heads=2/n_kv=1）仍命中同一 fold key → 证明"任意 n_rep 共用一份 shader" ✅；② CPU 与**真实 GPU** 双向对拍：与"按块映射复制成 MHA"前向差 **0**、输入梯度 1.19e-7 ✅；③ 全量 ctest 30/30 ✅ |
| **S3 ✅** Tied embedding | `GPTModel` 开关（§3.3）；`ModelSpec.tie_embeddings` | ① 参数条数差 = `V·D + V`（实测 2112 = 64·32+64）✅；② 与"head 权重显式设为 `token_emb_`、bias=0"的等价构造对拍：前向差 **0** ✅；③ **梯度累加**：tied 的 `token_emb` 梯度 == 非 tied 的（嵌入梯度 + head 的 dW），差 **0** ✅；④ 规格往返逐位一致 ✅；⑤ ctest 30/30 ✅ |
| **W1–W3 ✅** 权重侧（21 §4.8.3 的 P1.5） | `make_linear_layer` + `unique_ptr<Layer>`：`AttentionBase` 4 投影 / `FeedForward` fc1·fc2 / `GPTModel` LM head；`split_ternary_profile` 分流 + `effective_weight_quant` 唯一判据（§3.4） | ① 三值 GPT 参数张量形状与 f32 基线**逐一相同**、36/36 张量梯度非零 ✅；② **2B4T 形状端到端训练**（RoPE+ReLU²+RMSNorm+SubLN+GQA+tied+三值，CE+AdamW 200 步）：3.469→**0.018**（tied）/ 3.582→0.0064（BitLinear head）/ f32 基线 3.893→0.0045 ✅；③ CPU/GPU 末步 loss 差 **7.5e-4 < 1e-3** ✅；④ 既有 f16/f32 路径零回归 + ctest 30/30 ✅；⑤ RAPT/ViT 明确拒绝（不留半三值）✅ |

**统一回归口径**（每步都要满足）：

1. 构建零告警（`-Werror`）；`ctest` 全绿（本机 28 项；`--gpu` 变体按既有脚本口径）。
2. `bench/doc_inventory.ps1` 第 [4] 节 `L2-VIOLATIONS: 0`（SubLN 的 norm 经工厂、GQA 的索引经
   `upload_span`、tied head 经 `dsl::matmul`——都不引入 `Matrix`）。
3. `scan_exprs` 结构数变化**必须可解释**：SubLN 引入新的 norm 组合、GQA 引入新的 reshape/gather
   组合、tied head 引入新的 matmul trans 组合 → 逐条核对来源。
4. **默认关闭**：三项全关时，`ModelSpec`/参数布局/数值路径与改动前逐位一致。

---

## 6. 架构图（落地后）

### 6.1 2B4T block 的落点（三个开关分别插在哪）

```mermaid
flowchart TB
    X["x (d_model, batch·seq)"]
    N1["norm1_（RMSNorm, d_model）<br/>GPTBlock 既有"]
    QKV["w_q / w_k / w_v<br/>（w_k,w_v: n_kv·d_k 宽 = GQA）"]
    GQA["GQA 展开<br/>gather_rows(expand_idx)<br/>n_kv·d_k → n_head·d_k"]
    ATTN["fold 注意力（零改动）"]
    SN1["attn_sub_norm（RMSNorm, d_model）<br/><b>S1 新增 · 子层内部</b>"]
    WO["w_o"]
    N2["norm2_（RMSNorm, d_model）"]
    FFN["fc1 → gate×act → <b>ffn_sub_norm（d_ff）</b> → fc2<br/><b>S1 新增 · 子层内部</b>"]
    HEAD["lm_head_ / token_embᵀ（<b>S3</b>）"]

    X --> N1 --> QKV --> GQA --> ATTN --> SN1 --> WO
    WO -->|"残差 +"| N2
    N2 --> FFN -->|"残差 +"| HEAD
```

### 6.2 三项的"结构性"分级（为什么只有 SubLN 是 block 级差异）

```mermaid
graph LR
    BL["BitLinear<br/>（21 号文档 · 权重侧）"] --> C1["层类型替换<br/>block 拓扑不变"]
    G["GQA"] --> C2["子层内部宽度变化<br/>+ 一个 reshape/gather 步骤<br/>block 拓扑不变"]
    T["Tied embedding"] --> C3["模型级权重共享<br/>block 拓扑不变"]
    S["SubLN"] --> C4["<b>每层参数集合变化</b><br/>+ 子层内部数据流变化<br/>= 真正的 block 变体"]
    C4 --> D["结论：规格上是一等公民<br/>（ModelSpec 独立字段）<br/>实现上是变体（共享 GPT 代码）"]
```

### 6.3 与 21 号文档的分工（两条正交的腿）

```mermaid
graph TB
    subgraph W["权重侧（docs 21）"]
        W1["Precision::T1_58"]; W2["BitLinear（量化 forward / STE backward）"]
    end
    subgraph A["结构侧（本文）"]
        A1["SubLN"]; A2["GQA"]; A3["Tied embedding"]
    end
    W --> JOIN["GPT/RAPT 的 2B4T 形态"]
    A --> JOIN
    JOIN --> GOT["已齐（P1.5 落地）：<br/>· GPT 的三值接线（4 投影 + fc1/fc2 + LM head）<br/>· ReLU²（§3.4 / S4）<br/>= <b>三值 + SubLN + GQA + tied + ReLU² 可同时打开</b>"]
    JOIN --> MISS["仍缺：<br/>· HF 2B4T 权重转换器<br/>· RAPT / ViT 的三值接线（明确拒绝）<br/>· bias 置零、P2 行级打包"]
```

---

### 6.4 P1.5 落地后的全景（权重侧 × 结构侧同时打开）

一个 `PrecisionProfile{param: T1_58}` + 四个结构开关（`subln` / `n_head_kv` / `tie_embeddings`
/ `activation=relu2`）就能表达完整的 BitNet b1.58 2B4T 形态（规模另说）：

```mermaid
graph TB
    subgraph TOOL["L2 层工具箱（P1.5 之后）"]
        T1["make_linear_layer(in, out, weight_quant)<br/>None → Linear ／ T1_58 → BitLinear"]
        T2["make_norm_layer(width, norm_type)<br/>LayerNorm ／ RMSNorm ／ BatchNorm"]
    end

    subgraph MODEL["GPTModel（2B4T 形态）"]
        EMB["token_emb_ (V,D)<br/>+ Learned/Sinusoidal 位置编码表"]
        subgraph BLOCKS["GPTBlock × L（pre-norm 残差）"]
            N1["norm1：RMSNorm"]
            ATT["CausalSelfAttention<br/>W_q/W_k/W_v/W_o = <b>BitLinear</b><br/>GQA：K/V 输出宽 = n_head_kv·d_k<br/>SubLN：attn_sub_norm(d_model) → W_o"]
            N2["norm2：RMSNorm"]
            FF["FeedForward<br/>fc1/fc2 = <b>BitLinear</b><br/>ReLU²：relu²(gate)·up<br/>SubLN：sub_norm(d_ff) → fc2"]
        end
        LNF["ln_f：RMSNorm"]
        HEAD["lm_head = <b>BitLinear</b><br/>tie_embeddings：logits = token_emb_ · x"]
    end

    PROFILE["PrecisionProfile{param: T1_58}<br/>+ subln / n_head_kv / tie_embeddings / relu2"]

    T1 --> ATT
    T1 --> FF
    T1 --> HEAD
    T2 --> N1
    T2 --> N2
    T2 --> LNF
    PROFILE -. "param=T1_58 → weight_quant=T1_58（唯一判据）" .-> T1
    PROFILE -. "结构开关（ModelSpec / GptConfig 透传）" .-> BLOCKS
    EMB -->|"x"| N1
    N1 --> ATT --> N2 --> FF --> LNF --> HEAD
    N2 -. "残差：x + sub(norm(x))" .-> N1
```

**开关清单（默认值 = 既有路径逐位不变）**：

| 开关 | 取值 | 落点 | 依赖 |
|---|---|---|---|
| `PrecisionProfile.param` / `ModelSpec.weight_quant` | `t1_58` | 上表 3 处线性层 → `BitLinear` | 非存储精度：latent 恒 f32，量化缓冲 f16 |
| `subln` | `true` | `AttentionBase::attn_sub_norm_` / `FeedForward::sub_norm_` | 类型跟随 `norm_type`（2B4T = RMSNorm） |
| `n_head_kv` | `> 0` | K/V 投影输出宽度 + fold 的 `HeadGroup` 视图 | 必须整除 `num_heads` |
| `tie_embeddings` | `true` | head 复用 `token_emb_`（梯度累加进同一缓冲） | 与 `BitLinear` head 互斥（无独立 head） |
| `activation` | `relu2` | `ReLU2GLU`（`fc1_` 宽 2·d_ff） | 通用取值，CLI/GUI 已有 |

---

## 7. 提交清单（分支 `dev/t1_58`）

| # | 提交 | 内容 |
|---|---|---|
> 提交 hash 以 `git log dev/t1_58` 为准（本文档记录**提交主题**，不写 hash —— hash 会随 amend 变化）。

| # | 提交主题 | 内容 |
|---|------|------|
| 0 | `P1.5 立项：BitNet b1.58 2B4T 结构对齐（SubLN / GQA / tied embedding）` | 本文（三项裁决 + 依据 + 分期 + 架构图）+ `AGENTS.md` 索引 |
| S1 | `P1.5-S1 SubLN：子层内部的额外归一化（BitNet 2B4T）` | 子层可选 norm + 透传 + `ModelSpec.subln` + `src/bitnet_struct_test.cpp`（[1]–[6]）+ CMake 注册（ctest 28 → 30） |
| S2 | `P1.5-S2 GQA：分组查询注意力 + 头映射展开` | `n_head_kv` + 展开表（前向 `gather_rows` / 反向 `scatter_add_rows`）+ 透传 + `ModelSpec.n_head_kv` + 测试 [7]–[9] |
| S3 | `P1.5-S3 tied embedding：head 复用 token embedding` | `tie_embeddings` 开关 + 梯度累加 + `ModelSpec.tie_embeddings` + 测试 [10]–[11] |
| S4 | `P1.5-S4 ReLU²（BitNet 2B4T 的 hidden_act）` | `ActivationType::ReLU2` + `ReLU2GLU` 层 + FeedForward 接线 + CLI/GUI + scan 模型 pass + 测试 [12]–[13] |
| P2 | `P1.5-P2 GQA in-kernel 头映射（省掉 K/V 的头展开物化）` | `ExprViewKind::HeadGroup` + `gqa_ratio_of` + fold/bmm/vecacc 比率 + AttentionBase 不展开 + scan 显式 fold 登记 + GPU 侧对拍 |
| 4 | `P1.5 文档同步` | 本文状态/实施记录 + `AGENTS.md` + `docs/history/history.md` |
| W1 | `P1.5-W1 线性层工厂 + Attention/FeedForward 三值接线` | `make_linear_layer`（Linear/BitLinear 工厂）+ `AttentionBase` 4 投影 / `FeedForward` fc1·fc2 → `unique_ptr<Layer>` + `split_ternary_profile`（含自相矛盾 fail-fast） |
| W2 | `P1.5-W2 GPT 三值接线：投影/FFN/LM head + 规格·CLI·扫描登记` | `GPTBlock`/`GPTModel` 开关传播 + `lm_head_` + `effective_weight_quant` + `build_gpt_model_from_spec` 映射 + `text_train` 写规格/RAPT 前置拒绝 + scan 两条三值 GPT 用例（结构数 107 持平） |
| W3 | `P1.5-W3 验收：三值 GPT 接线 + 真实 BitNet（2B4T 形状）端到端训练` | `bitnet_struct_test` [14]（形状一致 + 36/36 梯度非零）、[15]（三配置收敛 + CPU/GPU 末步 loss 差 < 1e-3） |

---

## 8. 与 21 号文档的关系（一句话）

**21 管"权重怎么变"，22 管"图长什么样"。** 三值进的是精度词汇表 + `BitLinear`（21），
2B4T 的剩余差距是三个结构开关（22）。两条腿都齐了，本项目才**能表达** BitNet b1.58 2B4T 的形态。

---

## 9. 待定 / 已否决

### 待定

1. **`--model bitnet` 预设**：**明确不做**（用户裁定）；GUI 的 BitNet 预设留待以后。
   当前暴露面 = 库 API + `ModelSpec` + 通用 `--activation relu2`。
2. **权重转换器**：从 HF 2B4T checkpoint 加载（含逐张量三值化 + 尺度折算）——另立。
3. **权重侧接线的剩余边界**（21 §4.8.3 的 P1.5，GPT 已于 2026-10-10 落地 → §3.4）：
   RAPT 的 `ReLULinearAttention`（自持 4 个 `Linear` 且不转发 profile）与 ViT/MNIST
   Transformer 的补丁/池化侧仍未接 `make_linear_layer`。两者**明确拒绝** `t1_58`
   （CLI 前置报错 / 能力校验报错），不留"半三值"路径。
4. **`forward_step` 的增量推理**仍展开 K/V（保持 KV cache 布局不变）；若要省掉它，
   需要同时改 attention 的增量路径与 cache 布局——收益低于训练路径，暂不做。

### 已否决

1. **把 SubLN 做成 `NormType` 新值**：语义错误（它是挂载位置，不是归一化类型）。→ §3.1。
2. **把 SubLN 做成 `GPTBlock` 的第三个 norm**：block 看不到子层内部的张量。→ §3.1。
3. **新建 `BitNetModel` 平行容器**：要重抄位置编码/掩码族/KV cache/梯度检查点/文档掩码/
   offload/flush —— 双份维护，收益为零。→ §0 第 2 条。
4. **模板化 `AttentionBase<LinearT>` / `FeedForward<LinearT>`**：把"层类型是编译期决定"扩散到
   4 个头与全部实例化点，与 `09-custom-layer-ergonomics.md` 的方向相反。→ `21` §4.8.3。
5. **RAPT 挂 SubLN/GQA**：RAPT 的注意力是 ReLU 线性注意力（无 softmax），不是 BitNet 的形态。
   → §0 第 11 条。

---

## 10. 实施记录（落地差异与踩到的坑）

§3 的设计与实现一致；以下是**实现期才显形**的几点，按"代码注释只记当前状态、
历史过程进 history"的纪律，过程归档在 `docs/history/history.md`，这里只留结论性事实：

1. **`Linear(in_features, out_features)` 是"入在前"** —— GQA 收窄的只是 K/V 的**输出**宽度，
   正确写法 `w_k_(d_model, n_head_kv·d_k)`。写反会被 `bitnet_struct_test` [8] 的形状打印
   当场抓住（`param[2] gqa=16x8` vs 期望 `8x16`）。
2. **`grad_V` 也要折叠**：前向里 K 与 V **一起**展开，反向必须对称地一起折叠回 `n_head_kv`；
   漏掉 V 会在 `w_v_.backward` 处报 `grad_output shape mismatch`。
3. **声明式初始化的 seed 按"创建序号"混流**（`compute_engine.hpp` InitSpec 注释：
   "同 seed 的不同张量不撞流（同形状多层不互为镜像）"）→ **两次独立构造**的同构层权重
   并不相同，测试里的 A/B 必须**显式拷贝权重**。（与 `gpt_checkpoint_test.cpp` 文件头注释一致。）
4. **tied head 不转置**：`token_emb_ (V,D)` **就是** head 的权重矩阵，`logits = W_emb·x`；
   只有 backward 的 `dX = W_embᵀ·g` 需要 `transA=true`。
5. **attention fold 不在 `dsl::compute` 路径上**：层 forward 直调 `engine.eval_expr`，
   dry-run/模型 pass 一条 fold 结构都产不出（结构由构造实参决定）——因此 fold 结构
   一度**只能由 `scan_exprs` 的显式登记块产出**。P2 的 GQA fold 变体（K/V_t 走
   `HeadGroup` 视图）最初只加在模型 pass 的用例里 → GPU 注册表 miss；补进显式块后
   结构数 102 → **107**。**P4-4 ①（2026-10-15）起该显式块已删除**：注意力组合由
   `compute_layer_attention.hpp` 的 `attn_fold_anchor` 经 `FoldAnchor` 在静态初始化期
   自登记（掩码清单 X 宏 × {无偏置,位置偏置} × {MHA,GQA}）→ 新增组合无需改 `scan_exprs`。
6. **头分组比必须做成"视图参数"而不是"算子字段"**：视图 `param` 是运行期形状数据
   （不进 key、经 push constant `vp` 槽），所以任意 `n_rep` 共用一份 shader。
   实测：测试用 heads=4/n_kv=2、登记用 heads=2/n_kv=1，两侧仍命中同一 fold key。
7. **验收机器 = 102**：本机（软件 Vulkan/llvmpipe）的 `expr_gpu_test`/`fused_gpu_test`
   在退出段随机段错（基线同样复现、且故障时已打印 `ALL PASS`）；102 的真实 GPU 上
   30/30 全绿 —— 避免把环境问题误判成代码回归。
8. **P1.5 的坑：`param=T1_58` 会顺着"原样再注入一次"的代码路径打到不该打的地方。**
   `GPTModel` 构造器里除了 `set_precision_profile(precision)`，还单独把 `precision`
   再注给 `ln_f_` 与**位置编码器**（历史写法，f16 时代无害）。三值模式下这两处会拿
   `T1_58` 去 `create_tensor`（RMSNorm 的 γ/β、Learned 编码表）→ 引擎拒绝"非存储精度"。
   抓到它的不是运行时测试，而是 **`scan_exprs` 的模型 pass**（构建期）：`gpt_*_t1_58`
   用例当场报 `LearnedPositionEncoder: 初始化失败` / `层 RMSNorm 不支持 param=t1_58`。
   结论：**三值接线期间往 `scan_exprs` 的模型 pass 里加一条该组合的用例**，等于把"这条
   组合能不能构造 + 跑一遍 fwd/bwd"变成构建期门禁（结构数不必变，这道门禁本身就值）。
