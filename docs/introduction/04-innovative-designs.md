# neuralnet.cpp 创新设计总览

> **读者**：想了解本库架构/性能/算法的读者（调用者视角的总览）。总索引见 [`../README.md`](../README.md)；历史归档在 [`../history/history.md`](../history/history.md)。
> **状态**：现行。
本文档汇总本项目中所有具有**原创性或系统性思考**的设计。它不是架构/性能/融合等专项文档的重复，而是从"为什么这么做、创新点在哪、带来什么收益"的角度，把这些设计串成一张全景图。

关联文档：`01-architecture` · `02-performance` · `03-algorithm-reference`（介绍类）；专项设计见 `docs/` 下的融合、优化、IR 等文档。

---

## 0. 总览

一个好的深度学习框架，设计难点往往不在"算法本身"，而在于**如何把算法用干净、可维护、可并行、可扩展的方式组织起来**。本项目的创新集中在以下几个维度：

| 维度 | 核心创新 | 一句话 |
|------|---------|--------|
| **架构** | 分层引擎化 | 一次编写 Layer，CPU/GPU 零修改双跑 |
| **架构** | 铁律式职责划分 | 算法留 Layer、原语进引擎、Shader 是内部实现 |
| **编译** | AOT 注册表表达系统（JIT 兜底） | 表达式文本唯一、构建期扫描生成、运行时按 key 精确分发；主路径未命中 JIT 现编 |
| **性能** | 自适应并行 + 零分配线程池 | 自适应并行、消除每次任务的堆分配 |
| **性能** | 表达式模板零临时矩阵 | `a + b * c` 不物化中间结果 |
| **显存** | 结构融合（而非手写 kernel） | 三粒度融合：逐元素链 / matmul+归约 / fold 流式注意力 |
| **显存** | fold 单遍流式注意力 + 反向重算 | 不物化 `O(seq²)` 分数矩阵 |
| **显存** | 稀疏 CE + 梯度检查点 + 池归还 | GPT 训练峰值显存压至 ~27GB 量级 |
| **IR** | 带确定性 pass 的规范 IR | DCE/常量折叠/CSE/寄存器分配，key 定义在 canonical IR 上 |
| **算法** | 纯 BPE + 兜底词表自举 | 小模型也能稳定启动、支持中文 |
| **算法** | RAPT 注意力门控（RLA） | 利用 RoPE 硬截断无用 token |

下面逐条展开。

---

## 1. 核心架构创新

### 1.1 引擎化架构（Engine-Based）

**创新点**：让 `Layer::forward/backward` 只写一次，通过传入的 `ComputeEngine` 自动适配 CPU / GPU 双后端，而不是像多数教学框架那样为每后端各写一份。

```cpp
class Layer {
    virtual Result<Tensor> forward(ComputeEngine& engine, const Tensor& input) = 0;
    virtual Result<Tensor> backward(ComputeEngine& engine, const Tensor& grad) = 0;
};
```

**收益**：
- 新增一个后端 = 只实现 `ComputeEngine` 抽象，零 Layer 改动。
- 算法正确性在 CPU 上验证后可放心跑 GPU。

### 1.2 分层"铁律"（Red Lines）

这是本项目最鲜明的**原创治理原则**，贯穿所有文档：

```
引擎只提供 op-level 原语（matmul/reduce/broadcast/exp…），绝不出现 softmax/attention/layernorm 命名接口
算法文本只写在 Layer（ReLU/GeLU/Softmax/Attention 的公式只在 compute_layer.hpp / compute_loss.hpp）
Shader / 融合逻辑是引擎内部实现，用户不可见
```

**创新点**：不是把"引擎是否认识 softmax"当实现细节，而是把它当一条**不可逾越的红线**。引擎只认**结构**（如 `reduce(matmul(A,B))`），绝不认**算法名**。这使得算子融合、IR 优化、新后端都能在一个稳定的契约上展开。

配套约束：
- `ComputeEngine` 原语可"专"（matmul+归约、matmul+softmax 分母都是合法原语）但必须通用可复用、不叫算法名。
- 全程 `noexcept` / `Result<T>`（`std::expected`），零手动内存管理（`-fno-exceptions`）。

### 1.3 统一张量 `Tensor` + 零拷贝

`Tensor` 用 `shared_ptr` 持有 CPU/GPU 两份互斥存储，拷贝=引用计数，跨层传递零拷贝。修改需显式 `clone`。这为 GPU 训练"全程驻留显存、仅 evaluate 时下载"提供了容器基础。

---

## 2. AOT 注册表表达系统（Compiler-Style，主路径 JIT 兜底）

这是本项目**最具工程创新性**的设计，把"表达式"当成一门可编译的语言：

### 2.1 单一来源（Single Source of Truth）

算法表达式**直接写在 C++ 源码里**（如 `exp(x - row_max) / sum(...)`），而不是单独维护一份"计算图定义"。

### 2.2 构建期扫描 + 生成

```
Layer 内联表达式 → to_expr_spec 折叠 → ExprSpec（扁平 SSA IR）
    → expr_spec_key（规范结构 key）→ scan_exprs 收集
    → 生成阶段 用 glsl_gen 合成 GLSL → glslc → 内联 SPIR-V → fused_registry.hpp
运行时：fold → key → find_fused(key) → 精确 dispatch（注册表命中；miss 主路径 JIT 兜底）
```

**创新点**：
- **AOT 注册表（预热加速）**：库内已知的融合 kernel 在构建期预编译、内联进最终程序；`eval_expr` 主路径未命中走运行期 JIT 现编兜底（懒加载 `libnn-kernelgen.so` → 生成 SPIR-V → 懒建 pipeline）。
- **派生而非手写**：`scan_exprs` 通过 dry-run 执行 Layer 的 forward/backward 触达表达式，把折叠后的**结构（派生物）**采集进注册表，而不是手工维护一份 kernel 清单。
- **未命中策略**：GPU 上遇到未预生成的表达式结构，主路径默认 JIT 现编；`NN_STRICT_CLOSED_WORLD=1` 恢复硬报错（opt-in 看门狗），绝不静默回退 CPU，保持项目"不降级"哲学。

### 2.3 确定性 key 铁律

key 定义在 **canonical（优化后）IR** 上，scan 与 runtime 两端必须先 canonicalize 再算 key。且 pass 遍历顺序固定、CSE 胜利者选择固定、寄存器分配固定——避免跨编译器（Clang/MSVC）漂移（C++ 实参求值顺序未指定是这类漂移的常见来源，属必须规避的坑）。

---

## 3. 算子融合（结构融合，而非手写 kernel）

### 3.1 设计哲学

**不手写任何命名算法 kernel**（如不手写 flash-attention、不手写 softmax kernel），而是：
1. Layer 用 `dsl::compute` / `compute_reduce` / `compute_into`（GPU 上折叠为 `ExprSpec`）表达算法；
2. 引擎/工具按**结构**合成融合 kernel；
3. 所有中间 Tensor 由融合 kernel 内部消解，不落显存。

### 3.2 三粒度融合

| 粒度 | 覆盖 | 消除的中间量 |
|------|------|-------------|
| **逐元素链** | ReLU/GeLU/SwiGLU 连续逐元素 | 链上的全尺寸中间 Tensor |
| **matmul + 归约** | softmax 分子分母、norm 统计 | `A·B` 全尺寸物化 |
| **fold 流式注意力 / 稀疏 CE** | attention、大词表交叉熵 | `O(seq²)` / `O(vocab×seq)` 物化 |

### 3.3 matmul 参与表达式融合（"原语可专、但不叫算法名"）

matmul 不是孤立原语，而是表达式的**一段**：`dsl::matmul(a, b[, transA, transB, batch])`
折叠为 `ExprSpec` 的前置 matmul 段，与尾随的逐元素链/归约视图（`+bias`、激活、
`col_reduce_max`、softmax 分母）融合成**单个 kernel**。于是"matmul 后接结构"这类需求
不需要专用原语，也不需要在引擎接口上开算法名：

- softmax 分子分母 = `matmul` 段 + `col_reduce_*` 归约段，一条 `dsl::compute_reduce`；
- 注意力 forward = `FoldSpec`（QKᵀ/掩码/online softmax/ΣwV 分块流式，见 §4）；
- 运行时参数不进 AOT key：`batch`（dispatch z）、`rparam` 标量（如 `1/√d_k`、alpha）；
  转置标志进 key（生成期按分组定死）。

引擎原语只暴露结构语义（matmul / 归约 / 数据搬运），`ComputeEngine` 接口里不会出现
attention / softmax / layernorm 这类算法名。

### 3.4 形状无关融合（关键创新）

RoPE 的 `RowMod/RotateHalf` 参数如果以**结构常量**折进 key，每个 `d_k` 就要一个新融合 shader → 注册表无法穷举。

**解决**：把形状相关参数（mod/block）从 key 里**拿出来变成运行时 push constant**。结构相同、形状不同共享同一融合 shader——任意 `d_k`（含非 2 的幂）都全融合，零额外显存。这是"AOT 注册表"与"形状多变"矛盾的一个优雅解法。

---

## 4. 注意力内存高效化（fold 单遍流式）

### 4.1 问题

传统 `scores/masked/attn_cache_` 各占一份 `H·batch·seq²`，且 `attn_cache_` 永久缓存用于反向。这是 GPT+Vulkan 训练显存高的元凶之一。

### 4.2 现行方案：单 fold kernel 分块流式

`FoldSpec` 把 `QKᵀ → 掩码 → online softmax → ΣwV` 全部放进**一个 kernel**：按
`EXPR_FOLD_BLOCK=128` 逐块推进——行标量态（m/l）跨块进位、行向量态（O）经 `vecacc`
块内 rescale + 累加、`tri_skip` 把被屏蔽块整块钳成空转（跳过项恰为 -inf/0 恒等项，
与全量计算逐位一致）。**S 矩阵从不存在**，`m/l/O` 均不外溢显存（O 在寄存器/shared
分片内）。掩码 5 变体（Plain/Causal/Alibi/Doc/AlibiDoc）在 fold body 内以 select
链表达，由 `AttnScoreMask` 策略族在构造期定型（`AttentionBase::make_score_mask_()` 工厂）
——引擎只认 `FoldSpec` 结构、不认算法名。

- **Backward**：`recompute_W_` 两步重算 W（掩码 matmul → softmax 归约表达式），
  不缓存 W/m/l；backward 多算一遍 QKᵀ，换整份 `BH·seq²` 缓存。

### 4.3 收益

每层从 ~3×`BH·seq²` 降到 `O(BH·seq·d_k)`；forward 的 QKᵀ 只计算一遍，没有用计算换显存的额外重算代价。

---

## 5. 稀疏交叉熵（Sparse CE）

### 5.1 问题

大词表（vocab≈25k）交叉熵若物化整个 `(classes, total)` 的 softmax，显存与下载开销巨大。

### 5.2 方案

现行由融合表达式结构承载——`col_reduce_max + exp + row_gather` 一条表达式，单 kernel 完成全部计算：产出**稠密梯度**（每列只对合法列施加）与**标签位置的 log_softmax loss**，不从整张 softmax gather。

**创新点**：labels 以 `(1,N)` 浮点打包上传（`vocab ≤ 2²⁴` 时 float 可精确表示类别索引），kernel 内转 `uint` 读取；非法/被屏蔽列整列置 0，与 CPU 参考完全一致。显存从 ~3-4×`(classes,total)` 降到 ~2×。

---

## 6. IR 优化（带确定性 pass 的规范 IR）

### 6.1 动机

`ExprSpec` 已是事实上的轻量 IR（SSA、扁平、可序列化、确定性 key）；不做优化会直接带来：
- 子表达式 `grad*gamma` 重复 3 次 → 超 `EXPR_MAX_INPUTS=8`，只能手工拆表达式。
- 无 DCE/常量折叠，shader 携带冗余计算。
- 无寄存器分配，`num_regs` 受 `EXPR_MAX_REGS=16` 约束。

### 6.2 方案

- **IR-A canonicalize**：DCE + 常量折叠 + 代数化简 + 稳定重编号（保守、不改变浮点语义）。
- **IR-B CSE + 寄存器分配**：哈希指令去重，liveness 线性扫描确定性贪心分配寄存器。
- **IR-C 图 IR + 融合分析**：**现行**——`engine.begin_expr()/end_expr()` + `ExprSegment` RAII 守卫 + `expr_graph.hpp` 做图级跨表达式融合：**P1 链**（单输出逐元素链、允许 matmul 头段）与 **P2 分量**（纯逐元素 F32 同形状节点按依赖边连通成组，多消费者/菱形不再是边界，成员输出全部写穿 = `ExprSpec.extras`，≤4）。GPU 真录制（`execute_fused_graph`），CPU 普通运行 no-op，`NN_EXPR_SCAN` 下构建期扫描与运行期融合一致（注册表两端一致）。首个生产调用方是 Adam/AdamW——每参数张量的 m/v 写穿 + delta + `p += delta` 收敛为**一个多输出 kernel**；`NN_PROFILE` 实测（GPU 40HX，GPT d_model=64/4 层/heads=4/seq=256/batch=64，`adam`，20 步）设备 kernel **266 → 66.5 每步**、设备时间 **0.57 → 0.23 ms/step**。不需要写穿的长链仍可直接写成一个 `dsl::compute`。历史取舍见 `docs/history/history.md`。
- **IR-D emitter 抽象**：`ExprEmitter` 接口 + 注册表，一份 canonical IR 可产出多后端代码（后端实现按接口注册；当前注册的只有 `glsl` 后端）。

### 6.3 关键不变量

canonicalize 不改变 views/inputs 的顺序与内容，只优化 instrs/consts/num_regs → 运行时输入绑定布局不变。寄存器"先声明后赋值"以兼容 liveness 复用同号寄存器。

---

## 7. 显存优化体系（三级）

围绕 GPT 训练峰值显存（~27GB 量级，随三级体系持续下探）的三条独立路径：

### L1 激活重计算（梯度检查点）
- `Layer` 契约扩展 `recompute_supported / forward_recompute`；`GPTModel` 与 `RAPTModel` 均实现**块级检查点**（每 N 个 Block 存一次输入，backward 重算中间）。
- 与全存基线**逐位一致（max_abs=0）**（`gpt_checkpoint_test` / `rapt_checkpoint_test`）。
- 注意：复合层 override `forward_recompute` 时必须走**虚函数** `set_checkpoint_mode` 关闭子层——基类默认实现只改本块标志位，子层仍处 checkpoint 模式会导致缓存不重建、backward 误用上一 step 的陈旧缓存。

### L1-offload（activation offload）
- 通用 `ActivationOffloader`（`compute_layer_base.hpp`）把 `Layer::activation_cache()` 枚举的全部激活写入持久 host-visible slab（释放 device-local 显存），backward 前恢复；`GPTBlock` / `RAPTBlock` 共用同一实现。
- 与全存基线**逐位一致（max_abs=0）**（`gpt_offload_test` / `rapt_offload_test`，GPU-only）。
- 与梯度检查点可共存：checkpoint 块走重算（不驻留），其余块走 offload（不重算）。
- 仅 GPU 有意义：CPU 引擎的 `create_offload_buffer / offload_restore` 是 no-op，开启会得到 1×1 张量 → 不要对 CPU 引擎启用。

### L2 内存池整块归还 + 统计
- `MemoryPool` 新增 `PoolStats` / `release_idle_blocks()`（整块 `vkFreeMemory`，带保留阈值防抖动）。
- **结构融合宣示**：中间 Tensor 的归还路径安全——每个原语录制都包裹全内存屏障（写入→`SHADER_READ` / 输出→`MEMORY_READ`），保证 batch 命令缓冲内前序写入对后续可见。

### L3（远期）
- 自动融合 + 无 m/v 优化器（Adafactor 类）降参数状态内存。

### 精度红线（当前）

支持 **f16 混合精度**（`Precision` 类型系统 + `PrecisionProfile`，compute/stable 档可保
f32 以控制数值风险；BF16/F64 为"使用即报错"的保留值）。数值稳定性靠精度分档配置保证，
而不是靠"全库锁死 fp32"。

---

## 8. CPU 性能优化（L1/L2 层）

### 8.1 自适应并行
根据数据规模自动决定串行/并行，避免小数据量时线程调度开销（约 50~200μs）大于计算收益。实测在 ~512K 元素处首次稳定 >1.5x；低于该规模时串行更快。

### 8.2 线程池 latch 零分配
每个并行调用 = 1 次加锁 + 0 次堆分配 + 1 个原子计数器（N 分块批量入队），配合三阶段等待（短自旋 → work-stealing → 条件变量短超时）与"调用者参与计算"。

### 8.3 缓存分块 + 栈分配
`BLOCK_SIZE=64`（64×64×4B=16KB 装入 L1），B 块预取转置，b_block 栈分配零堆分配。

### 8.4 算子融合（原语级）
- 单算子级的原地运算/条件选择以表达式表达：`dsl::compute_into`（`dst ±= src`、缩放）、`dsl::select`（条件选择）——与所在表达式链融合为同一条 kernel，不单独 dispatch。
- **表达式级融合（当前主力）**：`dsl::compute` 把整条链折叠为单个 kernel（见 §3）。
- 多头注意力**批量化**：forward 由 fold 单 kernel 按 `batch*H` 网格一次 dispatch 处理所有样本与头；backward 用 `rearrange_3d → 单次 batched_matmul → 转回` 把 H 次 matmul 合并为 1 次 batch dispatch。
- 因果掩码在 fold body 内以 select 链表达、绝不物化，因而无掩码缓存；位置编码缓存：相同 `(batch,seq)` 只构造一次。

### 8.5 表达式模板零临时矩阵
`a + b * c` 在编译期构造 AST，单次遍历执行，不创建 `b*c` 中间矩阵，编译器可整体内联向量化。

---

## 9. 分词器与算法创新

### 9.1 纯 BPE（CharBPE）支持中文
默认 `bpe` 为纯 BPE（优先于 BBPE），**可支持中文**：每个汉字作为基础字符单元，学习常用字词合并——比跨语言字节切分更能捕捉词义；BBPE 作为备选。词表含 256 个 ASCII 兜底 token（ID 4~259）+ 4 个特殊符号，保证最小 `vocab_size=260` 也能稳定启动不崩溃。

### 9.2 GPT 训练约定
每行作为独立样本，`[BOS]` 开头、`[EOS]` 仅行尾；`generate()` 带 `min_new_tokens` 防止小模型过早输出 EOS；`seq_len` 降到覆盖 >99% 样本的规模以避 `n²` 显存。

---

## 10. 已移除：ZiPT — 注意力压缩（AttnZip）

> **已整体移除**。ZiPT 曾以"可学习记忆查询把长上下文压成记忆 token"作为本项目的
> 算法创新之一；**代码保留在 `legacy/zipt` 分支**，主线不再包含其实现与 CLI 入口。
>
> **恢复前提**（两条同时满足才允许恢复）：
> 1. **算法层**：压缩向量必须是**因果**的（压缩器只能看到当前位置之前的内容；原实现
>    在缺省 `W=L` 下压缩整条含未来 token 的序列）；
> 2. **代码层**：实现质量对齐 RAPT/GPT——支持 `forward_recompute`（梯度检查点）与
>    activation offload、CLI/序列化/测试覆盖齐备。
>
> 完整裁决依据与验收见 [`docs/history/history.md`](../history/history.md)「ZiPT 移除」条与 `AGENTS.md` §12。
> 长上下文一侧现由 **fold 单遍流式注意力**（§4）与 **RLA-2 / RAPT**（ReLU 线性注意力）承载。

---

## 11. 创新背后的工程方法

除了具体技术，项目在**方法论**上也有鲜明的、可复用的设计：

| 方法 | 体现 |
|------|------|
| **合规红线先行** | 每次设计与改动（融合/IR/显存）都先写"不可逾越红线"表，再谈实现 |
| **结构 > 命名的哲学** | 引擎认结构不认算法名，是融合与 IR 能落地的共同前提 |
| **AOT 注册表 + JIT 兜底** | 不静默回退 CPU；主路径未命中 JIT 现编（`NN_STRICT_CLOSED_WORLD=1` 可恢复硬报错） |
| **恶意保守的正确性安全网** | GPU 融合未命中 = 硬报错（铁律 7，暴露扫描覆盖缺口、绝不静默降级）；融合路径与 CPU 参考数值一致并互相验证 |
| **数值确定性** | 定点可复现、优化 pass 不改变浮点语义；默认 f32，f16 须显式 `PrecisionProfile` |
| **可验证增量里程碑** | M1-M6 每步有独立测试验证（gradcheck / CPU 对照），先小层数回归再全面放开 |

---

## 12. 收益一览

| 设计 | 量化收益（示例配置） |
|------|---------------------|
| fold 流式注意力 | 每层 `~3×BH·seq²` → `O(BH·seq·d_k)` |
| 稀疏 CE | 全 softmax `(vocab×seq)` 物化 → 仅标签 gather |
| 算子融合 + 显存体系 | GPT 训练峰值显存 ~27GB 量级 |
| IR CSE + 寄存器分配 | 消除"手工拆表达式"，`num_regs` 受控在 16 内 |
| 自适应并行 | 小矩阵 0.3x 退化 → 串行；大矩阵最高 ~7.8x 加速 |
| 融合 axpy（`dst += s·src` 一条表达式） | 每 step 省去 ~600 次 GPU buffer 分配 |
| 注意力批量化 | H 次 matmul → 1 次 batch dispatch（backward）；forward 为 fold 单 kernel 单 dispatch |

> 本文档为创新设计的**全景速览**，不替代各专项文档的细节。想要深入的读者请跳转文首的关联文档。