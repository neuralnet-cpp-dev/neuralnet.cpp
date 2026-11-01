# neuralnet.cpp 架构设计

> **读者**：想了解本库架构/性能/算法的读者（调用者视角的总览）。总索引见 [`../README.md`](../README.md)；历史归档在 [`../history/history.md`](../history/history.md)。
> **状态**：现行。
从零实现的 C++26 神经网络库，支持 CPU/GPU 双后端、多层 Transformer、GPT 语言模型训练与推理。

---

## 快速理解（30 秒版本）

**这个项目是什么**：一个从零实现的深度学习框架，类似 PyTorch 但更简单。

**核心设计**：
1. **分层架构**：6 层严格隔离，上层只调用下层接口
2. **引擎化**：同一个 Layer 代码自动适配 CPU 和 GPU
3. **表达式融合**：自动把多个小操作合并成一个 GPU kernel

**你需要理解的最少概念**：
1. `Matrix`（L1）：CPU 上的矩阵
2. `Tensor`（L2）：跨设备的张量（CPU/GPU）
3. `ComputeEngine`（L2）：计算引擎（CPU/GPU 后端）
4. `Layer`（L2）：神经网络层（Linear, Attention 等）

**复杂度来源**：
- GPU 编程（Vulkan）
- 表达式 DSL 和 AOT 融合
- 分布式状态机（CPU/GPU 双存储）

---

## 理解路线图

### 第一步：理解基础数据结构（1-2 天）
**目标**：理解数据如何表示和存储
- **文件**：`algebra_matrix.hpp`（Matrix 类）
- **关键概念**：行主序存储、矩阵运算
- **验证**：能解释 `data_[row * cols + col]` 的含义

### 第二步：理解计算引擎（2-3 天）
**目标**：理解如何执行计算
- **文件**：`compute_engine.hpp`（接口）、`compute_cpu_engine.hpp`（CPU 实现）
- **关键概念**：引擎化、原语（matmul, add, exp）
- **验证**：能解释 `engine.matmul(a, b)` 如何工作

### 第三步：理解神经网络层（3-5 天）
**目标**：理解如何构建模型
- **文件**：`compute_layer.hpp`（所有层定义）
- **关键概念**：forward/backward、梯度计算
- **验证**：能解释 `Linear::forward` 如何计算

### 第四步：理解模型容器（1-2 天）
**目标**：理解如何组合层
- **文件**：`model_container.hpp`
- **关键概念**：链式构建、参数管理
- **验证**：能解释 `model.add<nn::Linear>(784,256)` 的作用

### 第五步：理解训练流程（2-3 天）
**目标**：理解端到端训练
- **文件**：`src/text_train.cpp`（训练入口）
- **关键概念**：梯度下降、优化器
- **验证**：能解释训练循环的每一步

### 可选：理解 GPU 后端（5-7 天）
**目标**：理解 GPU 加速
- **文件**：`compute_gpu_engine.hpp`、`shaders/`
- **关键概念**：Vulkan、command buffer、SPIR-V
- **注意**：这是最复杂的部分，可以跳过

---

## 模块关系简化图

```mermaid
graph LR
    subgraph "用户代码"
        U[训练脚本]
    end

    subgraph "模型层"
        M[Model容器]
        L[Layer层]
    end

    subgraph "计算层"
        E[ComputeEngine]
        T[Tensor]
    end

    subgraph "数据层"
        MT[Matrix]
    end

    U --> M
    M --> L
    L --> E
    E --> T
    T --> MT

    style U fill:#e1f5fe
    style M fill:#f3e5f5
    style L fill:#f3e5f5
    style E fill:#e8f5e8
    style T fill:#e8f5e8
    style MT fill:#fff3e0
```

**箭头含义**：调用关系（上层调用下层）

---

## 系统分层总览

项目采用 **6 层分层架构**（L0 ~ L5），每层职责单一、严格隔离，上层仅依赖下层的公有接口。

```mermaid
graph TB
    subgraph "L5 用户入口层"
        A["mnist_train / mnist_infer"]
        B["text_train / text_infer"]
        C["tokenizer_train / tokenizer_infer"]
        D["gui.py (Python GUI)"]
    end

    subgraph "L4 领域构建层"
        E["domain_mnist.hpp — MNIST 模型工厂"]
        F["domain_gpt.hpp — GPT 模型工厂"]
        G["domain_tokenizer.hpp — 分词器"]
    end

    subgraph "L3 实现层"
        H["model_container.hpp — Model 容器"]
        I["model_serialization.hpp — 二进制序列化"]
        J["model_spec.hpp — 架构描述"]
    end

    subgraph "L2 计算层（引擎化）"
        K["compute_engine.hpp — 引擎抽象接口"]
        L["compute_cpu_engine.hpp — CPU 引擎"]
        M["compute_gpu_engine.hpp — GPU 引擎 (Vulkan)"]
        N["compute_layer.hpp — Layer 基类 + 所有层"]
        O["compute_loss.hpp — 损失函数"]
        P["compute_optimizer.hpp — 优化器"]
    end

    subgraph "L1 代数层"
        Q["algebra_matrix.hpp — 矩阵类 + 运算原语"]
        R["algebra_span.hpp — Span 抽象"]
        S["algebra_ops.hpp — 逐元素算子"]
    end

    subgraph "L0 硬件层"
        V["core_config.hpp — 自适应并行 / BLOCK_SIZE"]
        W["core_threadpool.hpp — 全局线程池"]
        X["core_errors.hpp — Result<T> = std::expected<T, Error>"]
        Y["core_assert.hpp — 断言宏"]
    end

    D -->|"subprocess"| A & B & C
    A & B & C --> E & F & G
    E & F & G --> H & I & J
    H & I & J --> K & N & O & P
    K --> L & M
    N & O & P --> Q
    Q --> R & S
    Q --> V & W & X & Y
```

---

## 核心设计原则

### 1. 引擎化架构（Engine-Based Architecture）

这是项目最核心的设计理念：

```
Layer 的 forward/backward 只写一次，通过 ComputeEngine 参数自动适配 CPU/GPU。
每个 Layer 只有一份与后端无关的 forward/backward 实现。
```

```cpp
// compute_layer_base.hpp — 所有 Layer 统一接口（M6 段 C：engine 由 init 绑定）
class Layer {
protected:
    ComputeEngine* engine_ = nullptr;               // init(engine) 时绑定
public:
    Result<void> init(ComputeEngine& engine);       // NVI：绑定后转各层的 init_impl
    virtual Result<Tensor> forward(const Tensor& input) = 0;
    virtual Result<Tensor> backward(const Tensor& grad_output) = 0;
};
```

**数据流（GPU 训练为例）：**

```
Matrix(x_batch)
  ──engine.from_matrix──▶ Tensor[GPU]
  ──forward──▶ Tensor[GPU]
  ──loss.forward──▶ Scalar
  ──loss.backward──▶ Tensor[GPU]
  ──backward──▶ (丢弃)
  ──optimizer.step──▶ 参数就地更新（全程在 GPU）
```

仅 `evaluate` 时 `engine.to_matrix` 下载到 CPU 做 argmax。

### 2. 算法与原语分离

| 层级 | 职责 | 示例 |
|------|------|------|
| **ComputeEngine** (L2) | 只提供 op-level 原语 | `matmul`, `add`, `exp`, `max`, `reduce` |
| **Layer** (L2) | 通过组合原语表达算法 | `ReLU = max(x, 0)`, `GeLU = 5 次原语组合` |
| **Shader** (GPU) | 引擎内部实现，用户不可见 | `matmul.comp`, `elementwise_v2.comp` |

这意味着 **Engine/Shader 不知道 "ReLU" 是什么**，它只提供 `max` 原语。Layer 用 `max(x, 0)` 表达 ReLU 算法。

### 3. 零手动内存管理

- `Matrix` 内部使用 `std::vector<Scalar>`，无裸指针
- `Tensor` 使用 `shared_ptr` 内部持有存储，拷贝廉价（零拷贝传递）
- 错误处理使用 C++23 `std::expected<T, Error>`，项目中 **禁止 throw/try/catch**
- 编译时通过 `-fno-exceptions` 强制执行

### 4. 统一张量类型 `Tensor`

`Tensor` 是跨设备的统一数据容器：

```cpp
class Tensor {
    Device device_;                    // CPU 或 GPU
    std::shared_ptr<Matrix> cpu_data_; // CPU 存储
    std::shared_ptr<GpuTensor> gpu_data_; // GPU 存储（条件编译）
};
```

- CPU/GPU 存储互斥：`device()` 决定哪个指针有效
- 跨设备传输由 `ComputeEngine` 负责，`Tensor` 本身不主动迁移
- `shared_ptr` 使得拷贝廉价，传递零开销

---

## 模块详解

### L0 硬件层

| 文件 | 职责 |
|------|------|
| `core_config.hpp` | `Scalar` 类型定义、`BLOCK_SIZE=64`、`PARALLEL_THRESHOLD`、自适应并行策略 |
| `core_threadpool.hpp` | 全局线程池，latch 零分配设计，`parallel_for_each` / `parallel_transform` |
| `core_errors.hpp` | `struct Error { std::string message; }` + `using Result<T> = std::expected<T, Error>` |
| `core_assert.hpp` | `NN_ASSERT` 宏（L1 层形状校验使用，L2+ 层使用 Result） |
| `core_file.hpp` | 文件加载工具 |

### L1 代数层

| 文件 | 职责 |
|------|------|
| `algebra_matrix.hpp` | `Matrix` 类：行主序存储 `(rows, cols)`，矩阵乘法（缓存分块 + 自适应并行），加法、转置、归约 |
| `algebra_span.hpp` | `Span` / `ConstSpan`：矩阵数据的安全视图，同时作为 DSL 叶子的数据载体 |
| `algebra_ops.hpp` | 逐元素算子定义（`ops::Add/Exp/Max/...` + `op_id()` → `ExprOp`），**表达式 DSL 的唯一算子来源** |

### L2 计算层（引擎化）

**ComputeEngine 原语分类：**

| 类别 | 原语 |
|------|------|
| 矩阵级 | `matmul`, `batched_matmul`, `matmul_with_bias`, `transpose`, `add_inplace`, `accumulate`, `scale_inplace`, `zero` |
| 归约级 | `row_reduce_sum`, `col_reduce_sum/max`, `grouped_reduce_sum/max`（沿行按固定长度 R 分组归约） |
| 数据操作 | `slice_rows`, `insert_rows`, `gather_rows`, `scatter_add_rows`, `rearrange_3d`, `im2col`, `col2im`, `clone`, `copy_from`, `cast` |
| 扫描级 | `scan_prefix_outer`, `scan_suffix_outer`, `outer_col`（RLA/RAPT，dk≤64） |
| 表达式 | `eval_expr`, `eval_expr_reduce`（AOT 融合 shader 入口；主路径未命中 JIT 兜底） |
| 批控制 | `begin_batch` / `end_batch`（CPU: no-op; GPU: command buffer） |
| 内存 | `release_idle_pool_blocks`, `pool_stats` |
| offload | `create_offload_buffer`, `offload_save/restore`（activation offload） |
| I/O / 跨设备 | `from_matrix` / `to_matrix`（宿主 Matrix 载体）、`read` / `write` / `get_index` / `set_index`（批量本体 + 索引语法糖）、`import`（跨设备/引擎拉取） |

> 引擎共 **52 个 virtual 方法**（复现 `bench/doc_inventory.ps1`）；逐元素/广播/条件选择不设 eager 原语，一律经表达式 DSL
>（`dsl::compute` / `compute_into` / `compute_reduce`）执行。接口全量清单见
> `../internal/12-compute-engine-inventory.md`。

**表达式统一入口：**

| 文件 | 职责 |
|------|------|
| `expr_spec.hpp` | `ExprSpec` 逐元素表达式扁平 IR（纯数据结构，跨后端可序列化，GPU AOT 契约）+ 可选 `fold` 段（`FoldSpec` 分块状态归约——通用折叠表达式机制，含 `tri_skip`、`EXPR_FOLD_BLOCK/ROWS_PER_WG` 共享常量）+ `expr_spec_key`（规范结构 key，AOT 收集/匹配依据） |
| `expr_dsl.hpp` | 统一表达式 DSL（`nn::dsl`）：编译期模板，普通数学写法；`compute` / `compute_reduce` / `compute_into`（原地目标传递）。CPU 直接求值（内联+SIMD）；GPU 经 `to_expr_spec` 折叠出 `ExprSpec` → 按 `expr_spec_key` 匹配预编译融合 shader。 |
| `expr_registry.hpp` | 构建期表达式注册表（收集折叠出的结构 + 精度变体，按 key 去重；**不再有 bin 序列化**——收集与生成同一进程） |
| `fused_registry.hpp` | **生成物**（构建期 生成阶段 产出）：`key → {ExprSpec 结构, 内联 SPIR-V}` 融合 shader 注册表；运行时按 key 精确匹配 |
| `tools/scan_exprs.cpp` | 构建期工具（**单步** = 收集 + 生成）：`FusedAnchor` 按类型自登记结构 + dry-run/模型 pass 补签名，随后原地生成 `fused_registry.hpp` |
| `tools/fused_generate.hpp` | 生成阶段（原独立工具 `gen_fused`，现为 `scan_exprs` include 的头文件）：注册表 → `glsl_gen` → glslc → 内联 SPIR-V → `fused_registry.hpp` |
| `eval_expr` | `ComputeEngine` 虚接口：CPU 编译期模板求值（经 `dsl::compute`）；Vulkan 按 `expr_spec_key` 查 `fused_registry`（AOT 注册表；主路径未命中运行期 JIT 兜底） |
| `dsl::compute(engine, expr[, P])` | 统一求值入口（输出形状由表达式推导；显式形式 `dsl::compute(engine, expr, rows, cols[, P])` 并存）：CPU 走编译期模板；GPU 折叠成 `ExprSpec` → `eval_expr` 按 key AOT 分发 |

> **AOT 收集原则**：表达式**文本只出现在 Layer**（内联写进 `forward/backward`）。构建期 `scan_exprs` 只收集折叠后的 `ExprSpec` **结构**（派生物，非手写定义）：由 `FusedAnchor<Expr>` 按表达式类型自登记（编译期可达，dry-run 跑不到的分支也覆盖），再由 dry-run / 模型 pass 补齐运行期配置相关的结构；随后同进程为每个结构发三份 shader（全 f32 / **运行期精度分派** `key#x` / native16 `key#a`）并内联进 `fused_registry.hpp`。**精度签名不是构建期集合**——分派 shader 声明输入/输出双视图、按 PC `prec` 走 uniform 分支，覆盖任意签名，故运行时无 miss、无边界 cast 回退、无回填清单。运行时按 key 精确匹配 dispatch，AOT 为预热加速；主路径未命中走运行期 JIT 现编。**登记方式**：fold 值构造经 **`FoldAnchor`** 自登记（与 `FusedAnchor` 同机制——新 fold 构造无需改 `scan_exprs`）：通用样例在 `expr_fold.hpp`（含 `make_fold_logsumexp`，不含注意力语义），**注意力 fold spec 由 `make_fold_attn_o` 所在的 `compute_layer_attention.hpp` 自登记**（层直调 `engine.eval_expr` 不经 DSL 钩子，故由定义方经 `FoldAnchor` 在静态初始化期登记全部组合）——掩码清单是 X 宏单一真源（枚举与登记表由它展开），**掩码（`AttnMaskKind`）× 位置偏置（`bool score_bias`）× {MHA, GQA} 的实际组合不会有"漏列一行"的缺口**（P4-4 ①，2026-10-15）。

### L3 实现层

| 文件 | 职责 |
|------|------|
| `model_container.hpp` | `Model` 容器：持有 `vector<unique_ptr<Layer>>` + `ComputeEngine*`，`add<T>(...)` 逐层构建（返回 `Result<void>`），`forward`/`backward` 委托 |
| `model_spec.hpp` | `ModelSpec` 纯数据结构：`ModelType` 枚举 + MLP/Transformer/GPT 参数 |
| `model_serialization.hpp` | 二进制序列化自描述格式（KeyValueRecord 规格头；写入 v5 = 每张量精度标签，读取 v4+），`save_model` / `load_model` / `peek_model_spec` |

### L4 领域构建层

| 文件 | 职责 |
|------|------|
| `domain_mnist.hpp` | MNIST 工厂函数：`build_mnist_mlp_model()` / `build_mnist_transformer_model()` |
| `domain_gpt.hpp` | GPT 工厂函数：`build_gpt_model()` / `build_gpt_model_from_spec()` |
| `domain_tokenizer.hpp` | 分词器：`Tokenizer` 基类 + `BPETokenizer` / `CharBPETokenizer` |

---

## 数据布局约定

所有张量采用 **batch-major** 布局：

```
输入:  (feature_dim, batch_size)     — 每列一个样本
输出:  (out_dim, batch_size)         — 每列一个样本
权重:  (out_features, in_features)   — 行主序存储

Matrix 索引:  data_[row * cols + col]
```

**批量注意力的特殊布局：**

```
多头 Q/K/V: (H*d_k, batch*seq)    — 头维度在行方向，batch 在列方向
rearrange 后: (batch*H*d_k, seq)  — 使 batched_matmul 能按 batch*H 切分
```

---

## 完整训练流程

```mermaid
sequenceDiagram
    participant U as User Code
    participant M as Model
    participant E as ComputeEngine
    participant L as Layer(s)
    participant O as Optimizer
    participant F as Loss

    U->>E: create engine (CPU/GPU)
    U->>M: build model(engine)
    U->>O: create optimizer(engine, params)

    loop Each Training Step
        U->>M: zero_grad()
        U->>E: from_matrix(batch) → Tensor
        M->>L: forward(Tensor) → Tensor   // engine 由 init 绑定（M6 段 C）
        L-->>M: output Tensor
        M-->>U: logits

        U->>F: forward(engine, logits, target) → Scalar
        U->>F: backward() → grad Tensor
        U->>M: backward(grad) → grad (discard)

        U->>O: step()
        O->>E: dsl::compute_into / dsl::compute / ...
    end

    U->>M: forward(test_input) → Tensor
    U->>E: to_matrix(Tensor) → Matrix
    U->>U: argmax → predict
```

---

## 构建与编译

**环境要求：**
- CMake ≥ 3.30
- Clang (支持 C++26) 或 GCC 15+
- Vulkan SDK（可选，GPU 加速）

**构建命令：**

```bash
cmake -B build -DCMAKE_BUILD_TYPE=Release
cmake --build build --parallel
```

**产物：**

| 可执行文件 | 用途 |
|-----------|------|
| `mnist_train` | MNIST 手写数字训练 |
| `mnist_infer` | MNIST 推理 |
| `text_train` | GPT 文本生成训练 |
| `text_infer` | GPT 文本推理 |
| `tokenizer_train` | BPE 分词器训练 |
| `tokenizer_infer` | BPE 分词器推理 |
| `layer_bench` | 算子 / Layer 性能基准 |
| `gpu_test` | GPU 后端集成测试（需 `-DNN_ENABLE_TESTS=ON`） |

---

## 完整头文件依赖图

```
nn.hpp（统一入口）
├── L0: core_errors → config → core_threadpool
├── L1: algebra_matrix → algebra_span / algebra_ops
├── L2: tensor → compute_engine → cpu_engine [→ gpu_engine]
│       → compute_layer → compute_loss → compute_optimizer
├── L3: model_container → model_spec → model_serialization
└── L4: domain_mnist → domain_gpt → domain_tokenizer
```
