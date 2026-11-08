#pragma once

#include <algorithm>
#include <cstdint>
#include <cmath>
#include <cstdio>
#include <cstdlib>
#include <initializer_list>
#include <iostream>
#include <limits>
#include <memory>
#include <random>
#include <functional>   // SamplingConfig::logits_transform 钩子（issue #34）
#include <span>
#include <string>
#include <utility>
#include <vector>

#include "compute_engine.hpp"
#include "compute_tensor.hpp"
#include "named_tensor_set.hpp"
#include "model_spec.hpp"
#include <neuralnet.cpp/precision.hpp>
#include "tensor_schema.hpp"
#include "expr_dsl.hpp"

namespace nn
{

// ── NN_F16_DEBUG：中间量扫描（CPU f16 发散定位诊断）─────────────────────
// 探针门（core_config.hpp 的 NN_PROBES_ENABLED）：默认构建里本函数是**空内联**，
// 20 个反向调用点零指令、零字符串；要排障时用 `-DNN_ENABLE_PROBES=ON` 重新配置
// 构建，再设 `NN_F16_DEBUG=1` 选择性地开（同一份探针构建里逐算子开关）。
#if NN_PROBES_ENABLED
inline void nn_dbg_scan(const char* tag, ComputeEngine& eng, const Tensor& t)
{
    static const bool on = nn::dsl::env_flag("NN_F16_DEBUG");
    if (!on) return;
    std::vector<Scalar> buf(t.rows() * t.cols());   // 宿主桥（17 §3 D11）：不经 Matrix
    if (auto er = nn::download_span(eng, t, std::span(buf)); !er)
    {
        std::fprintf(stderr, "[bwd][%s] download fail: %s\n", tag, er.error().message.c_str());
        return;
    }
    double mx = 0.0;
    bool bad = false;
    for (Scalar v : buf)
    {
        if (!std::isfinite(v)) bad = true;
        else mx = std::max(mx, std::fabs(static_cast<double>(v)));
    }
    std::fprintf(stderr, "[bwd][%s] %s max=%.6g%s\n", tag, t.shape_str().c_str(), mx,
                 bad ? "  <<< NONFINITE" : "");
    std::fflush(stderr);
}
#else
inline void nn_dbg_scan(const char*, ComputeEngine&, const Tensor&) noexcept {}
#endif

// ══════════════════════════════════════════════════════════════════════════
// Layer — 引擎化计算层基类
// ══════════════════════════════════════════════════════════════════════════

// ══════════════════════════════════════════════════════════════════════════
// PrecisionSet / PrecisionSupport — 层能力声明（docs 21 §4.2，裁决 R1）
//
// 背景（docs 21 §2）：`Precision` 是"精度词汇表"，加一个枚举值等于给**所有模型
// 的所有槽位**多一个可选项。若不声明"谁能用"，就会制造 18 §3.1 C2/C3 那类缺陷
// （"可组合但必崩，且无任何启动期提示"、"静默回落另一个实现"）。
//
// 解法：**层按槽声明自己支持哪些精度**，框架在 `Layer::init` 这个唯一咽喉处校验，
// 不兼容组合 = 初始化期报错（带层名 + 槽位 + 取值 + 该槽允许集合）。
//
// 为什么**按槽**而不是一个扁平集合：`BitLinear` 需要 `param ∈ {T1_58}` 而
// `compute/stable/optimizer ∈ {f16,f32}`；扁平 `{T1_58}` 会让
// `{param:T1_58, compute:T1_58}` 通过校验，然后**每个激活算子都被要求输出三值**。
//
// 位掩码实现：无分配、可平凡拷贝、可 constexpr，且留足扩展（uint32 = 32 种精度）。
// ══════════════════════════════════════════════════════════════════════════
struct PrecisionSet
{
    std::uint32_t mask = 0;

    [[nodiscard]] constexpr bool has(Precision p) const noexcept
    { return (mask & (1u << static_cast<std::uint32_t>(p))) != 0; }
    constexpr void add(Precision p) noexcept { mask |= (1u << static_cast<std::uint32_t>(p)); }
    [[nodiscard]] static constexpr PrecisionSet of(std::initializer_list<Precision> list) noexcept
    {
        PrecisionSet s;
        for (Precision p : list)
            s.add(p);
        return s;
    }

    // 诊断用：按枚举序罗列（"f16|f32"）——进错误信息，不进任何热路径。
    [[nodiscard]] std::string to_string() const
    {
        std::string s;
        for (const Precision p :
             {Precision::F16, Precision::F32, Precision::BF16, Precision::F64, Precision::T1_58})
        {
            if (!has(p)) continue;
            if (!s.empty()) s += '|';
            s += precision_name(p);
        }
        return s.empty() ? std::string("(空集)") : s;
    }
};

// 舍入精度集合 {f16, f32}：**一切既有层的默认能力**（§4.2 —— 这是"不影响其他层"
// 的落实方式：默认声明 = 现状，既有层一行不改）。
[[nodiscard]] constexpr PrecisionSet rounding_precision_set() noexcept
{ return PrecisionSet::of({Precision::F16, Precision::F32}); }

// 按槽的精度能力（四槽与 PrecisionProfile 一一对应；语义见 §4.3.2：
// param = "该层 forward 的**有效权重精度**"，不是"参数张量的存储布局"）。
struct PrecisionSupport
{
    PrecisionSet param, compute, stable, optimizer;

    [[nodiscard]] static constexpr PrecisionSupport rounding_all_slots() noexcept
    {
        const PrecisionSet s = rounding_precision_set();
        return PrecisionSupport{s, s, s, s};
    }
};

// ── P1.5：三值（T1_58）profile 的「复合层分流」──────────────────────────
// 语义（docs 21 §4.3.2 + §4.8.3）：`param = T1_58` 描述的是**线性子层
// （BitLinear）的权重是三值**，不是"本层自己的存储布局是三值"——
// T1_58 不是存储精度，拿它建张量会被引擎拒绝。
// 因此持有线性子层的复合层（Attention / FeedForward / GPTBlock / GPTModel /
// RAPT*）必须把一次 profile 拆成两份：
//   · `self`   —— param 归一化为 f32（复合层自身不持有三值权重；它自建的张量
//                 如 token 嵌入按 f32 创建），其余三槽原样；
//   · `linear` —— 三值模式（weight_quant=T1_58）下 param 置为 T1_58，
//                 否则 == self → 交给 BitLinear / Linear。
// 非三值入参（param != T1_58）时 `self == linear == 入参` → 既有路径逐位不变。
//
// **配置自相矛盾 = fail-fast**：本层未以三值模式构造（weight_quant=None）却
// 收到 param=T1_58，说明有人把三值声明打到了普通 Linear 上——普通 Linear
// 承载不了三值权重，此时**不静默降级成 f32**，直接报错（否则会得到"配置了
// 三值、实际跑 f32"的静默错值路径）。
struct TernaryProfileSplit
{
    PrecisionProfile self;    // 自身 / 非三值子层
    PrecisionProfile linear;  // 直接持有的线性子层（BitLinear 或 Linear）
};

[[nodiscard]] inline TernaryProfileSplit
split_ternary_profile(const char* layer_name, const PrecisionProfile& profile, bool ternary)
{
    if (!ternary && profile.param == Precision::T1_58)
    {
        NN_UNWRAP(false, std::string("层 ") + layer_name +
                             "：收到 param=t1_58，但该层不是"
                             "三值模式（weight_quant=None）—— 三值权重只对 BitLinear 有意义；"
                             "请以 weight_quant=t1_58 构造该层，或把 param 改回 f16/f32"
                             "（docs/internal/21-quantized-weights.md §4.8.3）");
    }
    TernaryProfileSplit out{profile, profile};
    if (out.self.param == Precision::T1_58) out.self.param = Precision::F32;
    if (ternary) out.linear.param = Precision::T1_58;
    return out;
}

// 「param 归一化」单用版（给自建张量的复合层用：`GPTModel` 的 token 嵌入）。
[[nodiscard]] inline PrecisionProfile without_ternary_param(PrecisionProfile profile) noexcept
{
    if (profile.param == Precision::T1_58) profile.param = Precision::F32;
    return profile;
}

// 「profile → 线性层种类」的**唯一**约定（与 MLP 工厂 `build_mnist_mlp_model`
// 的 `ternary = (precision.param == T1_58)` 同源）：模型层构造时若 profile 的
// param 槽声明了 T1_58，就等价于 weight_quant=T1_58（显式开关优先保留）。
// 这样 CLI `--precision-param t1_58`、`ModelSpec.weight_quant` 与库 API 三条
// 路径收敛到同一个判据，不存在"声明了三值却构造出普通 Linear"的组合。
[[nodiscard]] inline WeightQuant effective_weight_quant(const PrecisionProfile& profile,
                                                        WeightQuant explicit_quant) noexcept
{ return (profile.param == Precision::T1_58) ? WeightQuant::T1_58 : explicit_quant; }

// ══════════════════════════════════════════════════════════════════════════
// 参数形态协议（v7 文件角色；docs/internal/23 §2.2）
//
// 一句话：**kind 是参数级的**。序列化层按 `Model::parameters()` 的顺序逐条读写
//   `[kind][precision][rows][cols][aux][payload]`，由**拥有该参数的那个层**
//   决定它落盘/载入的形态（Dense / 三值 latent / 三值打包 …）——取代了原先
//   "L3 dynamic_cast 到 BitLinear + 层树枚举（sub_layers）"的做法。
// ══════════════════════════════════════════════════════════════════════════

// 参数级 kind（v7 参数条目第一字节；与 docs 23 §2.1 的表一一对应）
enum class ParamKind : std::uint8_t
{
    Dense = 0,           // 普通浮点参数（Linear 权重/偏置、norm、嵌入、BN 统计…）
    TernaryLatent = 1,   // BitLinear 的 f32 latent（训练态；写进 .nnckpt）
    TernaryPacked2 = 2,  // 三值打包（2 bit/权重；运行期容器形态）
    TernaryPacked3 = 3,  // 三值打包（base-3，1.6 bpw；.nnmodel 的默认载荷）
    I8Packed4 = 4,       // 预留（P3：激活/张量 int8，4×int8/字）
};

// 文件角色（v7 文件头的一个字节）：只回答"这份文件是什么"，
// **不**引入"可训练/不可训练"的模型状态。
enum class ModelRole : std::uint8_t
{
    Model = 0,       // 推理模型（.nnmodel）：写推理所需的全部参数（三值层写打包形态）
    Checkpoint = 1,  // 训练断点（.nnckpt）：模型 + 训练参数（三值层写 f32 latent）
};

[[nodiscard]] inline const char* param_kind_name(ParamKind k) noexcept
{
    switch (k)
    {
    case ParamKind::Dense:
        return "Dense";
    case ParamKind::TernaryLatent:
        return "TernaryLatent";
    case ParamKind::TernaryPacked2:
        return "TernaryPacked2";
    case ParamKind::TernaryPacked3:
        return "TernaryPacked3";
    case ParamKind::I8Packed4:
        return "I8Packed4";
    }
    return "?";
}

[[nodiscard]] inline const char* model_role_name(ModelRole r) noexcept
{ return (r == ModelRole::Checkpoint) ? "checkpoint(.nnckpt)" : "model(.nnmodel)"; }

// ── 参数载入意图（P1-7）────────────────────────────────────────────────
// 同一个文件（三值层为打包形态）有两种载入方式——**角色**回答"这份文件是什么"，
// **意图**回答"载入方要拿它做什么"，两者正交：
//   · `Inference`：进**部署只读态**（`BitLinear::packed_only_`，0.25 B/权重，
//     `backward()` 明确报错）——`text_infer` / `mnist_infer` 用；
//   · `Trainable`：把打包权重按文件 τ **反量化**成 f32 latent（warm start /
//     QAT 续训入口）——首次 forward 与文件里的模型逐位一致（量化器不动点 +
//     播种量化缓存，见 `ternary_pack.hpp` 的 `latent_row_scale` 与
//     `BitLinear::import_param`）。
// Dense 参数不受影响（两种意图同一条路径，逐位不变）。`.nnckpt` 的三值层写的是
// TernaryLatent：它本来就带 latent，故两种意图都得到可训练态（零差异）。
enum class WeightLoadIntent : std::uint8_t
{
    Inference = 0,
    Trainable = 1,
};

// 单个参数条目的形态。载荷是 `Tensor`（**不是** Matrix → 不触 L2 铁律）：
// 宿主上传/下载与字节编码都在序列化层（L3）。
struct ParamEntry
{
    ParamKind kind = ParamKind::Dense;
    Precision precision = Precision::F32;
    std::size_t rows = 0;   // 逻辑形状（= 权重形状，供载入期校验）
    std::size_t cols = 0;
    Tensor aux;             // 形态附加载荷（打包三值：τ，形状 (rows,1)；
                            //  TernaryLatent + τ = 反量化 warm start，P1-7）
    Tensor payload;         // 主体载荷
};

class Layer
{
public:
    // 层与引擎的绑定状态（显式状态机）。
    // 不用"engine_ 指针非空"推断：那既分不清"从未绑定 / init 失败 / 已就绪"，
    // 也分不清"绑定成功"与"引擎已销毁"。
    enum class BindingState : std::uint8_t
    {
        unbound,   // 从未 init（或 init 前的初始态）
        ready,     // 绑定成功且 init_impl / 参数精度自检均通过
        failed,    // 上一次 init 失败——层不可用，但允许修正后重新 init
    };

protected:
    // 梯度检查点模式：为 true 时 forward 不保留逐层中间激活（供激活重计算）。
    bool checkpoint_mode_ = false;

    // D7：精度配置（§9.2，Model 在 add/构造 Layer 时注入，每层一份）
    // 默认全 F32 = 现状行为，零回归（G5）
    PrecisionProfile p_;

    // ── M6 段 C（17 §5 M6 / 15 §3.3）：每调用 engine 形参删除 ─────────────
    // 层在 `init(engine)` 时绑定（公共 init 是 NVI 包装，绑定后转 init_impl），
    // forward/backward/zero_grad/forward_recompute 不再收 engine 形参。
    //
    // **生命周期契约（07-engine-ownership.md）**：engine_ 是强引用。层存活
    // 期间引擎不会析构；init 时从 ComputeEngine& 的 weak_from_this() 提升。
    std::shared_ptr<ComputeEngine> engine_;
    BindingState binding_state_ = BindingState::unbound;

    // 绑定读取：未 init / init 失败 / 引擎已销毁都是调用方错误 → fail-fast，
    // 先打**调用点**（source_location 默认参在调用处求值 → 定位到层的哪个方法）。
    [[nodiscard]] ComputeEngine&
    engine_ref(std::source_location loc = std::source_location::current()) const
    {
        if (binding_state_ == BindingState::failed)
        {
            const std::string msg =
                std::string("[layer-lifetime] ") + layer_name() +
                ": 上一次 init 失败（层处于半初始化状态）—— 修复原因后重新 init(engine)";
            detail::fatal_at("NN_FATAL", loc.file_name(), static_cast<int>(loc.line()),
                             msg.c_str());
        }
        if (!engine_)
        {
            const std::string msg = std::string("[layer-lifetime] ") + layer_name() +
                                    ": 未绑定引擎（先调 init(engine)）";
            detail::fatal_at("NN_FATAL", loc.file_name(), static_cast<int>(loc.line()),
                             msg.c_str());
        }
        return *engine_;
    }

public:
    virtual ~Layer() = default;

    // ── 绑定状态（诊断/测试可查询；不需要触发 abort）─────────────────────
    [[nodiscard]] BindingState binding_state() const noexcept { return binding_state_; }
    // 是否持有引擎强引用（init 成功后恒 true）
    [[nodiscard]] bool engine_alive() const noexcept { return engine_ != nullptr; }

    // ── 层名（诊断设施）─────────────────────────────────────────────────
    // 能力校验的错误信息必须能定位到"哪一层"（此前 Layer 无任何名称设施，
    // 诊断只能靠 file:line）。各层 override 返回自己的名字；复合层返回自身名。
    [[nodiscard]] virtual const char* layer_name() const noexcept { return "Layer"; }

    // ── D7：精度配置注入（§9.2）─────────────────────────────────────────
    // virtual：复合层/持有辅助对象（RoPE、位置编码器）的层需要把 profile 继续
    // 下传（否则辅助对象内的 DSL 求值退回 F32，静默丢掉 f16 存储收益）。
    //
    // **契约（D3(b)）**：profile 在 `init(engine)` 之后**不可变**——已 init 时
    // 调用即 fail-fast。"profile 何时有效"因此从"三条注入路径的交集"收敛成一条
    // 可判定规则（docs 21 §4.3.2）：校验（唯一的、发生在 init 内的）不可能被旁路。
    // 复合层的 override 必须先调本函数（先校验），再逐子层下传。
    // 默认按 `param_children()` 向参数子层广播——复合层
    // 只需列出子层即可，漏写转发（子层留在 f32）不再可能。需要对不同子层注入
    // 不同 profile 的复合层（如 FFN 的三值分流）仍可 override：先调本函数，
    // 再逐子层覆盖为各自 profile（最终值以 override 的覆盖为准）。
    virtual void set_precision_profile(const PrecisionProfile& profile)
    {
        if (binding_state_ == BindingState::ready)
        {
            NN_UNWRAP(false, std::string(
                                 "set_precision_profile: 层已 init，精度 profile 之后不可变（层=") +
                                 layer_name() +
                                 "）—— 请在 init(engine) 之前注入"
                                 "（docs/internal/21-quantized-weights.md §4.3.2(b)）");
        }
        p_ = profile;
        for (Layer* c : param_children())
            c->set_precision_profile(profile);
    }
    [[nodiscard]] const PrecisionProfile& precision_profile() const noexcept { return p_; }

    // ── 层能力声明（R1，§4.2）──────────────────────────────────────────
    // 默认 = 现状（f16/f32 × 四槽）→ 既有层零改动。声明支持的层 override。
    [[nodiscard]] virtual PrecisionSupport precision_support() const
    { return PrecisionSupport::rounding_all_slots(); }

    // forward/backward 只写一次，CPU/GPU 由引擎实现自动分发（引擎来自 init 绑定）
    [[nodiscard]] virtual Result<Tensor> forward(const Tensor& input) = 0;

    [[nodiscard]] virtual Result<Tensor> backward(const Tensor& grad_output) = 0;

    // ── 具名多输出协议（docs/internal/31 RL-0）─────────────────────────────
    // 默认层是单端口 "output"；复合层（OutputBundleLayer）覆盖下列入口。
    // 不接受 schema 的重载只供单层直接使用；序列中的最后一层由 Model 把
    // ModelSpec 中登记的 schema 显式传入。
    [[nodiscard]] virtual Result<TensorSchema> output_schema() const
    {
        return TensorSchema::create(std::string(layer_name()) + ".output",
                                    {tensor_field("output")});
    }

    [[nodiscard]] virtual Result<NamedTensorSet> forward_named(const Tensor& input)
    {
        NN_TRY(schema, output_schema());
        return forward_named(input, *schema);
    }

    [[nodiscard]] virtual Result<NamedTensorSet> forward_named(const Tensor& input,
                                                               const TensorSchema& schema)
    {
        if (!schema.valid() || schema.size() != 1)
            NN_FAIL(std::string("Layer::forward_named: 默认单输出层要求 schema 恰有"
                                "一个字段（层=") +
                    layer_name() + "）");
        NN_TRY(out, forward(input));
        std::vector<NamedTensor> values;
        values.push_back(NamedTensor{
            .name = schema.fields()[0].name,
            .value = std::move(*out),
        });
        return NamedTensorSet::create(schema, std::move(values));
    }

    [[nodiscard]] virtual Result<Tensor> backward_named(const GradientBundle& gradients)
    {
        NN_TRY(schema, output_schema());
        return backward_named(gradients, *schema);
    }

    [[nodiscard]] virtual Result<Tensor> backward_named(const GradientBundle& gradients,
                                                        const TensorSchema& schema)
    {
        if (!schema.valid() || schema.size() != 1)
            NN_FAIL(std::string("Layer::backward_named: 默认单输出层要求 schema "
                                "恰有一个字段（层=") +
                    layer_name() + "）");
        if (gradients.schema() != schema)
            NN_FAIL(std::string("Layer::backward_named: gradient schema 不匹配"
                                "（层=") +
                    layer_name() + "）");
        const FieldHandle handle{gradients.schema().fingerprint(), 0};
        NN_TRY(g, gradients.require(handle));
        return backward(**g);
    }

    // 参数访问（供 optimizer 使用）— 使用 reference_wrapper 替代裸指针，明确表达非拥有语义
    [[nodiscard]] virtual std::vector<TensorRef> parameters() { return {}; }
    [[nodiscard]] virtual std::vector<TensorRef> param_gradients() { return {}; }

    // ── 参数形态协议（v7；取代 dynamic_cast 与 sub_layers）────────────────
    // `index` = 本层（含子层）参数扁平顺序中的下标，与 `parameters()` **同序**。
    //   · 叶子层：默认实现（Dense 直取 `parameters()[index]`）；
    //   · 复合层：默认实现按 `param_children()` 顺序转发（与 `parameters()`
    //     的拼接顺序同形），因此只需覆盖 `param_children()`；
    //   · 特殊形态的层（BitLinear）覆盖两个方法，按 kind 分派。
    // 载入时形态不被接受（如把打包形态塞进普通 Linear）→ fail-fast。
    [[nodiscard]] virtual std::size_t param_count() { return parameters().size(); }

    [[nodiscard]] virtual Result<ParamEntry> export_param(std::size_t index, ModelRole role)
    {
        auto children = param_children();
        const std::size_t own = own_param_count_();
        if (!children.empty() && index >= own)
        {
            index -= own;
            for (Layer* c : children)
            {
                const std::size_t n = c->param_count();
                if (index < n) return c->export_param(index, role);
                index -= n;
            }
            NN_FAIL(std::string("export_param: 参数下标越界（复合层=") + layer_name() + "）");
        }
        (void)role;
        auto ps = parameters();
        if (index >= ps.size())
            NN_FAIL(std::string("export_param: 参数下标越界（层=") + layer_name() + "）");
        return dense_entry_(ps[index].get());
    }

    [[nodiscard]] virtual Result<void> import_param(std::size_t index, const ParamEntry& entry)
    {
        auto children = param_children();
        const std::size_t own = own_param_count_();
        if (!children.empty() && index >= own)
        {
            index -= own;
            for (Layer* c : children)
            {
                const std::size_t n = c->param_count();
                if (index < n) return c->import_param(index, entry);
                index -= n;
            }
            NN_FAIL(std::string("import_param: 参数下标越界（复合层=") + layer_name() + "）");
        }
        if (entry.kind != ParamKind::Dense)
            NN_FAIL(std::string("import_param: 该层不接受此参数形态（层=") + layer_name() +
                    "，kind=" + param_kind_name(entry.kind) + "，可接受 {Dense}）");
        auto ps = parameters();
        if (index >= ps.size())
            NN_FAIL(std::string("import_param: 参数下标越界（层=") + layer_name() + "）");
        Tensor& t = ps[index].get();
        return import_into_(t, entry);
    }

    // 诊断（F2）：梯度缓冲是否已**实际分配**。
    // 采用惰性梯度分配的层（Linear / BitLinear）在 init 后、第一次
    // param_gradients()/backward()/zero_grad() 之前返回 false —— 推理路径
    // （只 forward）应当一直是 false，这也是"推理不为梯度付显存"的可见信号。
    // 默认 true = "本层不参与惰性方案（梯度随参数一起常驻）"，供未迁移的层沿用。
    [[nodiscard]] virtual bool grad_buffers_allocated() const noexcept { return true; }

protected:
    // 参数归属的子层（复合层覆盖；叶子层默认空 = 本层参数全归自己）。
    // 契约：顺序 = 本层 `parameters()` 里"子层参数"的出现顺序，且子层参数
    //       拼接结果与 `parameters()` 完全一致。
    // ⚠ 这**不是**层树枚举 API（原公开的 `sub_layers()` 已删除）：它服务于
    //   参数形态协议的下标转发（export_param / import_param）与**逐子层广播**
    //   （set_precision_profile / set_training / clear_cache 的默认转发，
    //    issue #29）。只进参数协议、不参与广播的辅助对象不要列进来。
    [[nodiscard]] virtual std::vector<Layer*> param_children() noexcept { return {}; }

    // 本层**自身**参数个数（= 总数 − 子层参数数）。默认实现按 `parameters()`
    // 与 `param_children()` 的契约反推；契约被破坏时返回 0（后续下标转发会
    // 在越界处 fail-fast，不静默错位）。
    [[nodiscard]] std::size_t own_param_count_()
    {
        auto children = param_children();
        if (children.empty()) return param_count();
        std::size_t child_total = 0;
        for (Layer* c : children)
            child_total += c->param_count();
        const std::size_t total = param_count();
        return total >= child_total ? total - child_total : 0;
    }

    // Dense 条目构造（叶子层的默认导出；特殊形态层导出自己的 Dense 参数时也用它）。
    // payload **共享**参数张量（零拷贝）——序列化层自行按其 precision 下载。
    [[nodiscard]] static ParamEntry dense_entry_(Tensor& t)
    {
        ParamEntry e;
        e.kind = ParamKind::Dense;
        e.precision = t.precision();
        e.rows = t.rows();
        e.cols = t.cols();
        e.payload = t;
        return e;
    }

    // 条目 → 目标张量（形状/精度校验；同精度零转换，异精度经引擎 cast）。
    [[nodiscard]] Result<void> import_into_(Tensor& dst, const ParamEntry& e)
    {
        if (e.rows != dst.rows() || e.cols != dst.cols())
            NN_FAIL(std::string("import_param: 形状不匹配（层=") + layer_name() + "，期望 " +
                    std::to_string(dst.rows()) + "x" + std::to_string(dst.cols()) + "，实际 " +
                    std::to_string(e.rows) + "x" + std::to_string(e.cols) + "）");
        if (e.payload.precision() == dst.precision()) return engine_ref().copy_into(dst, e.payload);
        return engine_ref().cast_into(e.payload, dst);
    }

    // ── 复合层参数收集（消除各复合层 parameters()/param_gradients() 的同构级联）──
    // 按实参顺序拼接若干列表；实参可以是 `Tensor`（隐式变成单元素）或
    // `std::vector<TensorRef>`（子层级联结果）。用法：
    //     return collect_refs(token_emb_, pos_encoder_->parameters(),
    //                         forward_block_refs_(&GPTBlock::parameters),
    //                         lm_head_.parameters());
    // 语义与手写的 `p.insert(p.end(), x.begin(), x.end())` 序列完全一致
    // （顺序就是实参顺序，不改变优化器看到的参数顺序）。
    [[nodiscard]] static std::size_t ref_count_impl_(const Tensor&) noexcept { return 1; }
    [[nodiscard]] static std::size_t ref_count_impl_(const std::vector<TensorRef>& v) noexcept
    { return v.size(); }
    static void append_refs_impl_(std::vector<TensorRef>& out, Tensor& t) { out.push_back(t); }
    static void append_refs_impl_(std::vector<TensorRef>& out, const std::vector<TensorRef>& v)
    { out.insert(out.end(), v.begin(), v.end()); }

    template <typename... Groups>
    [[nodiscard]] static std::vector<TensorRef> collect_refs(Groups&&... groups)
    {
        std::vector<TensorRef> out;
        out.reserve((std::size_t{0} + ... + ref_count_impl_(groups)));
        (append_refs_impl_(out, std::forward<Groups>(groups)), ...);
        return out;
    }

    // 把「对块容器逐块调用某成员函数」的结果拼起来（三个模型的 blocks_ 级联共用）。
    //   RefGetter = 指向 Layer 子类 parameters / param_gradients 的成员函数指针。
    template <typename Blocks, typename RefGetter>
    [[nodiscard]] static std::vector<TensorRef> collect_block_refs_(Blocks& blocks,
                                                                    RefGetter getter)
    {
        std::vector<TensorRef> out;
        for (auto& b : blocks)
        {
            auto r = (b.*getter)();
            out.insert(out.end(), r.begin(), r.end());
        }
        return out;
    }

    // ── Pre-Norm 残差块反向（GPTBlock / TransformerEncoderLayer / RAPTBlock 共用）──
    // 前向：x2 = x1 + sub1(norm1(x))；out = x2 + sub2(norm2(x2))
    // 反向：grad_s2  = sub2.bwd(grad_out)
    //       grad_x2  = grad_out + norm2.bwd(grad_s2)     ← 残差 2 分流
    //       grad_s1  = sub1.bwd(grad_x2)
    //       grad_x1  = grad_x2 + norm1.bwd(grad_s1)      ← 残差 1 分流
    // 返回 grad_x1。
    //   add_prec = 两处残差相加的**表达式输出精度**。各块历史行为不同（GPT/
    //   Transformer 传 p.compute；RAPT 的残差相加历史上未传 profile、恒 F32），
    //   故显式传入以保持逐位不变——不要"顺手统一"成 p.compute。
    [[nodiscard]] static Result<Tensor>
    prenorm_residual_backward_(ComputeEngine& engine, const Tensor& grad_output, Layer& norm1,
                               Layer& sub1, Layer& norm2, Layer& sub2, Precision add_prec)
    {
        NN_TRY(grad_s2, sub2.backward(grad_output));
        NN_TRY(b_n2, norm2.backward(*grad_s2));
        auto grad_x2 = dsl::compute(engine, dsl::leaf(grad_output) + dsl::leaf(*b_n2),
                                    grad_output.rows(), grad_output.cols(), add_prec);
        NN_TRY_CHECK(grad_x2);
        NN_TRY(grad_s1, sub1.backward(*grad_x2));
        NN_TRY(b_n1, norm1.backward(*grad_s1));
        return dsl::compute(engine, dsl::leaf(*grad_x2) + dsl::leaf(*b_n1), grad_x2->rows(),
                            grad_x2->cols(), add_prec);
    }

    // ── Pre-Norm 残差块前向的一个残差分支 ─────────────────────────────────
    // 返回 x + sub(norm(x))（GPT/Transformer/RAPT 三块的两个残差分支共用）。
    //   add_prec 同上：显式传以保持各块历史精度行为逐位不变。
    [[nodiscard]] static Result<Tensor> prenorm_residual_forward_(ComputeEngine& engine,
                                                                  const Tensor& x, Layer& norm,
                                                                  Layer& sub, Precision add_prec)
    {
        NN_TRY(n, norm.forward(x));
        NN_TRY(s, sub.forward(*n));
        return dsl::compute(engine, dsl::leaf(x) + dsl::leaf(*s), x.rows(), x.cols(), add_prec);
    }

public:
    // 梯度清零（每个训练 step 开始前调用）
    [[nodiscard]] virtual Result<void> zero_grad()
    {
        ComputeEngine& engine = engine_ref();
        for (auto& grad : param_gradients())
        {
            NN_TRY(r, engine.zero(grad));
        }
        return {};
    }

    // batch 录制粒度控制（默认 no-op，仅 GPTModel override）
    virtual void set_flush_interval(std::size_t /*interval*/) {}

    // 文档感知：设置当前 step 每样本文档 id（默认 no-op，GPTModel override）
    virtual void set_doc_ids(std::span<const std::size_t> /*ids*/) {}

    // 训练/推理模式切换。默认按 `param_children()` 向
    // 参数子层广播（漏写转发 → eval 时 Dropout/BN 行为错，不再可能）；
    // 自身需记录开关的层（BatchNorm 等）override 时先调本函数再记状态。
    virtual void set_training(bool training)
    {
        for (Layer* c : param_children())
            c->set_training(training);
    }

    // 非可学习状态收集（默认空，BatchNorm 的 running 统计量等需要 override）
    [[nodiscard]] virtual std::vector<TensorRef> extra_state() { return {}; }

    // 引擎相关初始化（创建/上传权重张量），替换构造函数中的 NN_ASSERT 模式。
    // **NVI（M6 段 C）**：公共入口负责绑定 engine_，各层 override `init_impl`
    //（层代码不感知绑定，改名由编译器穷尽驱动：`init(...) override` → `init_impl`）。
    // 默认实现空操作；各层在构造后由 Model::add<T>() 调用（测试里也必须调一次）。
    //
    // **精度能力校验（R3，docs 21 §4.3）**：这是全仓**唯一**的校验咽喉 ——
    // `Model::add<T>()` 先注入 profile 再 init；工厂路径（构造器注入）也在 init 前
    // 完成注入；复合层的 `init_impl` 逐个 init 子层 → 叶子层各自校验即可，
    // **不需要任何聚合/递归求交逻辑**（那会把静态声明变成递归求交，复杂度升一个量级）。
    // 校验必须在 init_impl **之前**：init_impl 会用 p_.param 建权重张量
    //（T1_58 走到那里才会报"不是存储精度"，离根因太远）。
    [[nodiscard]] Result<void> init(ComputeEngine& engine)
    {
        // 纯静态校验先做：失败时层保持未绑定，不留下"指针已写、init_impl 没跑"
        // 的半初始化状态（旧实现会把它误判成"已 init"，后续改 profile 直接 abort）。
        NN_TRY_CHECK(check_precision_support_());

        // 强引用提升：引擎必须由 shared_ptr 管理。栈上引擎无法保证"层存活
        // 期间引擎不析构"，因此在入口明确拒绝，而不是留下悬垂引用。
        auto keepalive = engine.weak_from_this().lock();
        if (!keepalive)
            NN_FAIL(std::string("Layer::init: 引擎必须由 shared_ptr 管理"
                                "（使用 CpuEngine::create() / GpuEngine::create()）；层=") +
                    layer_name());

        if (binding_state_ == BindingState::ready)
        {
            if (engine_.get() != &engine)
                NN_FAIL(std::string("Layer 已绑定到另一个引擎（层=") + layer_name() +
                        "）：跨引擎重绑会让旧权重留在原引擎、新引擎读到未初始化存储；"
                        "请构造新层");
        }

        engine_ = std::move(keepalive);
        binding_state_ = BindingState::ready;   // init_impl 内的 engine_ref() 可用

        if (auto r = init_impl(engine); !r)
        {
            binding_state_ = BindingState::failed;
            return r;
        }
        if (auto r = check_param_precision_(); !r)
        {
            binding_state_ = BindingState::failed;
            return r;
        }
        return {};
    }

    // 便捷重载：引擎工厂返回 shared_ptr，调用方不必手写 *engine。
    [[nodiscard]] Result<void> init(const std::shared_ptr<ComputeEngine>& engine)
    {
        if (!engine) NN_FAIL("Layer::init: engine 为空");
        return init(*engine);
    }

    // ── P1-6 R2：参数存储精度自检（2026-10-14）────────────────────────────
    // `init` 之后逐个校验"层声明的 param 槽"与"参数张量的实际存储精度"一致。
    // 防的是一类**静默降级**：层把权重/梯度硬编码成 `Precision::F32`（或忘了
    // 用 `p_.param`），于是 `--f16` 下该层参数仍是 f32 —— 训练照跑、数值也不会
    // 错，但"f16 省字节"在其上完全落空（P2-3 在 Conv2D / RAPT 修的就是这一族：
    // Conv2D 的 w_/b_、RAPT 的 token_emb_）。**只查 `param` 槽**：compute/stable
    // 只影响中间量、不要求与参数存储同精度；optimizer 槽作用于状态张量（不在
    // `parameters()` 里）。复合层（GPTModel 等）的 `parameters()` 会递归下探
    // 子层，故每个子层各自校验一次即可、不会漏。`precision_bytes(p_.param) == 0`
    // 的情形（T1_58 等非存储精度声明）跳过——那时参数形态由层自定（BitLinear
    // 的 latent 恒 f32）。
    [[nodiscard]] Result<void> check_param_precision_()
    {
        if (precision_bytes(p_.param) == 0) return {};
        for (const TensorRef& ref : parameters())
        {
            const Tensor& t = ref.get();
            if (t.precision() != p_.param)
                NN_FAIL(std::string("参数存储精度与 param 槽不一致: 层 ") + layer_name() + " 的 " +
                        t.shape_str() + " 实际 " + precision_name(t.precision()) +
                        "，但 param=" + precision_name(p_.param) +
                        "（硬编码 F32 会让 --f16 在该层静默失效；见 docs/internal/18 P1-6 R2）");
        }
        return {};
    }

protected:
    // ── 能力校验实现：把 profile 的四个槽逐个对照 precision_support() ────────
    [[nodiscard]] Result<void> check_precision_support_() const
    {
        const PrecisionSupport sup = precision_support();
        const PrecisionProfile& p = p_;
        if (!sup.param.has(p.param)) return precision_slot_error_("param", p.param, sup.param);
        if (!sup.compute.has(p.compute))
            return precision_slot_error_("compute", p.compute, sup.compute);
        if (!sup.stable.has(p.stable)) return precision_slot_error_("stable", p.stable, sup.stable);
        if (!sup.optimizer.has(p.optimizer))
            return precision_slot_error_("optimizer", p.optimizer, sup.optimizer);
        return {};
    }

    // 错误信息口径（§7 验收 2）：层名 + 槽位 + 取值 + 该槽**允许的集合**
    [[nodiscard]] Result<void> precision_slot_error_(const char* slot, Precision got,
                                                     const PrecisionSet& allowed) const
    {
        NN_FAIL(std::string("精度能力校验失败: 层 ") + layer_name() + " 不支持 " + slot + "=" +
                precision_name(got) + "（该槽允许: " + allowed.to_string() +
                "）—— 见 docs/internal/21-quantized-weights.md §4.2");
    }

public:
    // 梯度检查点（激活重计算）契约 ──────────────────────────────────
    // checkpoint_mode_ = true 时，forward 不保留中间激活（供 L1 激活重计算）；
    // forward_recompute 重算 forward 并重建缓存（供 backward 使用）。
    virtual void set_checkpoint_mode(bool enabled) { checkpoint_mode_ = enabled; }
    [[nodiscard]] bool checkpoint_mode() const noexcept { return checkpoint_mode_; }

    // 释放本层为 backward 保留的中间激活缓存（清空成员缓存 Tensor，归还显存）。
    // 由 GPTModel 在 checkpoint 块 backward 之后调用，避免重算的激活跨块累积
    // （否则所有块缓存会在 backward 末尾同时驻留，抵消检查点的显存收益）。
    // 默认按 `param_children()` 向参数子层广播（漏写
    // 转发 → 显存/状态残留，不再可能）；持有自身缓存的层 override 时先清自身
    // 缓存，需要连子层一起清再调本函数（或由默认转发代劳）。
    virtual void clear_cache()
    {
        for (Layer* c : param_children())
            c->clear_cache();
    }

    // 返回本层 backward 所需的中间激活缓存引用（供 activation offload 导出/导入）。
    // 仅返回 valid 的张量；掩码等小而常驻的缓存不在此列（不参与 offload，保持常驻）。
    [[nodiscard]] virtual std::vector<TensorRef> activation_cache() { return {}; }

    // 该层是否可作为“重计算单元”（即 forward_recompute 有实际意义）
    [[nodiscard]] virtual bool recompute_supported() const { return false; }

    // 从保存的输入重算 forward，重建本层 backward 所需的中间缓存。
    // 默认实现：临时关闭 checkpoint 模式重跑 forward（保留缓存）再恢复。
    // 复合层（GPTBlock 等）override 以同时关闭子层的 checkpoint 模式。
    [[nodiscard]] virtual Result<Tensor> forward_recompute(const Tensor& saved_input)
    {
        const bool prev = checkpoint_mode_;
        checkpoint_mode_ = false;
        auto r = forward(saved_input);
        checkpoint_mode_ = prev;
        return r;
    }

protected:
    // 各层的初始化实现（原 `init(ComputeEngine&)` override 全部改名至此）
    [[nodiscard]] virtual Result<void> init_impl(ComputeEngine& /*engine*/) { return {}; }

public:
    // 梯度检查点粒度（默认 0 = 不启用；由 GPTModel 等 override）
    virtual void set_checkpoint_every(std::size_t /*stride*/) {}

    // activation offload（L1-offload）开关（默认 no-op；GPTModel override）
    virtual void set_activation_offload(bool /*enabled*/) {}

    // 理论 offload RAM 字节数（各层累计；默认 0，GPTModel override）
    [[nodiscard]] virtual std::size_t offload_ram_bytes() { return 0; }
};

// ── 辅助：深拷贝 Tensor（通过 engine.clone()，无 PCIe 传输） ──────────────
// 用于需要修改中间结果但不影响原 Tensor 的场景（如 LayerNorm 中的 diff）
// ══════════════════════════════════════════════════════════════════════════
// ActivationOffloader — 通用激活 offload（L1-offload）
//
// 把「本层 backward 所需的中间激活」（由 Layer::activation_cache() 枚举）
// 逐个写进一块持久 host-visible slab，随后把成员张量置空以释放 device-local
// 显存；backward 入口再从 slab 恢复。与具体层无关：GPTBlock / RAPTBlock 共用
// 同一实现（避免两份易漂移的拷贝）。
//
// 用法：
//   offloader.set_enabled(true);
//   ... forward ...
//   offloader.export_activations(engine, activation_cache());  // 导出并释放
//   ... backward 入口 ...
//   offloader.import_activations(engine);                      // 恢复
//
// 注意：export 依赖 forward 后成员地址稳定（refs_ 持有成员引用）；
//       无有效缓存时（如 checkpoint 模式 forward 不驻留激活）静默跳过。
// ══════════════════════════════════════════════════════════════════════════
class ActivationOffloader
{
private:
    bool enabled_ = false;
    bool offloaded_ = false;
    Tensor slab_;                                   // 持久 host-visible 缓冲（跨 step 复用）
    std::vector<TensorRef> refs_;                   // 各激活成员引用（地址稳定）
    std::vector<std::pair<std::size_t, std::size_t>> shapes_;  // 各激活形状
    std::vector<std::size_t> offsets_;              // 各激活在 slab 中的**字节**偏移
    std::vector<Precision> precisions_;             // 各激活的存储精度（f32/f16，#P8）

public:
    void set_enabled(bool enabled) noexcept
    {
        enabled_ = enabled;
        if (!enabled)
        {
            // 关闭即作废：已导出的激活数据无法回填（成员张量在 export 时被
            // 置空），保留 Offloaded 状态只会让后续 import 读到不一致的 slab。
            discard();
            slab_ = Tensor{};   // 释放持久缓冲
        }
    }
    [[nodiscard]] bool enabled() const noexcept { return enabled_; }
    [[nodiscard]] bool offloaded() const noexcept { return offloaded_; }

    // 丢弃本轮导出（不回填）。语义 = "这些激活不会再被 backward 使用"：
    //   · 推理/评估路径：forward 没有配对的 backward，export 出的 slab 数据
    //     在下次 forward 时已作废——必须在 forward 入口丢弃，否则状态机会把
    //     上一轮的 slab 当成这一轮的激活导回（静默错值）。
    //   · slab 本身保留复用（host 内存在下次 export 时按需覆盖），不重建。
    void discard() noexcept
    {
        refs_.clear();
        shapes_.clear();
        offsets_.clear();
        offloaded_ = false;
    }

    // 导出：逐个写入 slab，写入后置空成员张量（数据已在 host slab）
    [[nodiscard]] Result<void> export_activations(ComputeEngine& engine,
                                                  std::vector<TensorRef> refs)
    {
        if (!enabled_) return {};
        // 状态机：Offloaded 状态只能经 import（消费）或 discard（作废）离开。
        // 走到这里说明上一轮导出既没被 backward 消费、也没在 forward 入口丢弃
        // ——继续覆盖 slab 会让后续 backward 静默读到本轮写了一半的数据。
        if (offloaded_)
            NN_FAIL("ActivationOffloader::export_activations: 上一轮导出的激活尚未 import"
                    "（forward 未配对 backward，且 forward 入口未 discard）");
        // 只保留有效缓存：refs_/shapes_/offsets_ 必须逐项对齐（import 用同一下标
        // 写回 refs_），因此在这里**压缩**，而不是在写入循环里 skip 无效项。
        refs_.clear();
        for (auto& ref : refs)
            if (ref.get().valid()) refs_.push_back(ref);
        offsets_.clear();
        shapes_.clear();
        // slab 容量校验：slab 必须容纳**本次**导出的激活总量（批大小/
        // 序列长度变化、--resume 后续训、最后一个不满 batch 之后的 step 等
        // 都会改变总量）；若容量不足，offload_save 会按新 offset 越界写
        // slab → 缓冲区破坏/设备丢失。因此每次导出都按当前总量校验，
        // 不足则重建。
        std::size_t needed = 0;
        offsets_.clear();
        precisions_.clear();
        for (auto& ref : refs_)
        {
            // 精度协议（#P8）：slab 按激活**自身精度**存储（f32 = 4 B/元素、
            // f16 = 2 B/元素），restore 用记录的精度重建张量 → 成员激活精度
            // 与 forward 时一致，不再出现"f16 存成 f32、import 后变 f32"的漂移。
            // 更宽的精度（bf16/f64/t1_58）Phase 1 既不建 Tensor 也不进 slab。
            const Precision pr = ref.get().precision();
            if (pr != Precision::F32 && pr != Precision::F16)
                NN_FAIL("ActivationOffloader::export_activations: 仅支持 f32/f16 激活（当前 " +
                        std::string(precision_name(pr)) +
                        "）；bf16/f64/t1_58 请改用 --checkpoint-every");
            // 每个条目按 8 B 对齐：VkBufferCopy 的 offset 需 4 B 对齐，且 f16 的
            // 元素体积是 2 B（混排后奇数字节偏移会破坏对齐）。
            needed = (needed + 7u) & ~std::size_t{7};
            offsets_.push_back(needed);
            precisions_.push_back(pr);
            needed += ref.get().size() * ((pr == Precision::F16) ? 2u : 4u);
        }
        if (needed == 0)
        {
            offloaded_ = false;
            return {};
        }
        // CPU 引擎的 offload 原语是 no-op（restore 返回 1×1）——export 会把成员
        // 缓存置空、import 再把 1×1 写回，等于毒化 backward。CLI 早已忽略该组合，
        // 这里对**所有**非 CLI 调用方统一 fail-fast（唯一的正确做法是别开）。
        if (engine.device() != Device::GPU)
            NN_FAIL("ActivationOffloader::export_activations: activation offload 仅支持"
                    " GPU 引擎（CPU 引擎的 offload 原语是 no-op，开启会破坏 backward；"
                    "请改用 --checkpoint-every）");
        if (!slab_.valid() || slab_bytes() < needed)
        {
            NN_TRY(slab, engine.create_offload_buffer(needed));
            slab_ = std::move(*slab);
        }
        for (std::size_t i = 0; i < refs_.size(); ++i)
        {
            auto& ref = refs_[i];
            NN_TRY(r, engine.offload_save(slab_, offsets_[i], ref.get()));
            shapes_.push_back({ref.get().rows(), ref.get().cols()});
            ref.get() = Tensor{};   // 释放 GPU 版（数据已在 host slab）
        }
        offloaded_ = true;
        return {};
    }

    // 导入：从 host slab 恢复激活到缓存成员（backward 前调用，替代重计算）
    [[nodiscard]] Result<void> import_activations(ComputeEngine& engine)
    {
        if (!offloaded_) return {};
        for (std::size_t i = 0; i < offsets_.size(); ++i)
        {
            auto t = engine.offload_restore(slab_, offsets_[i], shapes_[i].first, shapes_[i].second,
                                            precisions_[i]);
            NN_TRY_CHECK(t);
            refs_[i].get() = std::move(*t);
        }
        offloaded_ = false;
        return {};
    }

    // 实际 slab 字节数（诊断用；未创建时 0）
    [[nodiscard]] std::size_t slab_bytes() const noexcept
    { return slab_.valid() ? slab_.size() * sizeof(float) : 0; }
};

[[nodiscard]] inline Result<Tensor> clone_tensor(ComputeEngine& engine, const Tensor& src)
{ return engine.clone(src); }

// ══════════════════════════════════════════════════════════════════════════
// 采样：重复惩罚 → temperature 缩放 → top-k / top-p 截断 →
//       数值稳定 softmax → 随机采样 / 贪心（argmax）
//
// GPTModel / RAPTModel 的 generate() 各自逐 token 维护不同的运行态
// （KV cache / RLA 运行态），但"从末位 logits 选下一 token"这一步两者
// **逐字相同** → 收敛到本函数（曾有三份拷贝，改一处要改三处；第三份属
// 于已移除的 ZiPTModel，见 docs/history/history.md）。
//
//   logits        就地变为概率（调用方不需要原值）
//   temperature   >0 随机采样（1.0 = 不缩放但仍采样）；<=0 贪心
//   消耗恰好一次 dist(rng)（仅采样分支）——RNG 消耗序与旧实现逐位一致
//
// P0-5（2026-10-15）：新增 top-k / top-p（核采样）/ 重复惩罚 / 种子。
// **全部默认值 = 关闭**（top_k=0 / top_p=1 / repeat_penalty=1 / 无 history）
// 时本函数与旧路径**逐位一致**（max / exp / 累加 / 逆 CDF 的遍历顺序、
// RNG 消耗次数都不变），采样器单测锁这条等价性。
// ══════════════════════════════════════════════════════════════════════════
// ── 采样配置（P0-5）───────────────────────────────────────────────────────
// 固定顺序（可复现、与文档同源）：
//   ① 重复惩罚：对 history 中**去重**后出现的 token（logit>0 → /=penalty，
//      否则 *=penalty；`repeat_window` 限制只看最近 N 个，0 = 全部）
//   ② 温度：temperature > 0 且 != 1 才缩放（<=0 = 贪心，不缩放）
//   ③ top-k：按（值降序，下标升序）保留前 k 个（0 = 关闭）
//   ④ 数值稳定 softmax（未截断时与旧路径逐位一致：max/exp/累加/归一化
//      的遍历顺序都是"下标升序"）
//   ⑤ top-p：在**保留集**上按概率降序取"累计 ≥ top_p"的最小前缀（至少 1 个），
//      随后在保留集内重新归一化；top_p >= 1 = 关闭
//   ⑥ temperature <= 0 → 贪心（并列取最小下标，**不消耗 RNG**）；
//      否则逆 CDF 采样，**按下标升序**累加、恰好消耗一次 dist(rng)
struct SamplingConfig
{
    Scalar temperature = 1.0; // <=0 = 贪心
    std::size_t top_k = 0; // 0 = 关闭
    Scalar top_p = 1.0; // >=1 = 关闭（核采样阈值）
    Scalar repeat_penalty = 1.0; // <=1 = 关闭
    std::size_t repeat_window = 0; // 0 = 全部 history
    std::uint64_t seed = 0; // has_seed=false 时忽略
    bool has_seed = false; // true = 用 seed 播种（可复现）

    // ── 外部 logits 掩码/变换钩子（重复惩罚前的域约束入口）─────────────
    // 在**重复惩罚之前**（即全部库内采样策略之前）对 host 侧 logits 原地
    // 变换：约束解码场景（棋类合法着、语法约束、工具调用 schema）在此把
    // 非法位置 -inf / 加偏置。回调发生在 logits 已在 host 的那一步
    //（generate 已 download），零 GPU 往返。
    //   · 不设置（默认）= 逐位旧行为（RNG 消耗序不变）；
    //   · 对 -inf 位置：重复惩罚（logit>0 判定）、softmax（exp(-inf)=0）
    //     均自然兼容；temperature 除法 -inf/t = -inf 亦然；
    //   · 回调内**不得**修改 logits.size()（span 只读长度）。
    std::function<void(std::span<Scalar> /*logits in/out*/)> logits_transform;
};

// 扩展采样器（cfg 全默认时的输出与下面 temperature 重载逐位一致）
[[nodiscard]] inline std::size_t sample_next_token_(std::vector<Scalar>& logits,
                                                    const SamplingConfig& cfg, std::mt19937_64& rng,
                                                    std::uniform_real_distribution<Scalar>& dist,
                                                    std::span<const std::size_t> history = {})
{
    const std::size_t n = logits.size();
    // RV-01：n == 0 时下面的 `logits[0]` / max 归约都越界 → 无条件终止
    NN_ASSERT_ALWAYS(n > 0, "sample_next_token_: empty logits");

    // ── ⓪ 外部 logits 变换钩子（issue #34）：全部库内策略之前 ────────
    // 未设置（默认）时零开销，RNG 消耗序与旧路径逐位一致。
    if (cfg.logits_transform) cfg.logits_transform(std::span<Scalar>(logits.data(), logits.size()));

    // ── ① 重复惩罚（去重；判定只依赖 history 的内容，不依赖扫描顺序）──
    if (cfg.repeat_penalty > 0.0 && cfg.repeat_penalty != 1.0 && !history.empty())
    {
        const std::size_t begin = (cfg.repeat_window > 0 && history.size() > cfg.repeat_window)
                                      ? history.size() - cfg.repeat_window
                                      : 0;
        std::vector<std::uint8_t> seen(n, 0);
        for (std::size_t i = begin; i < history.size(); ++i)
        {
            const std::size_t t = history[i];
            if (t >= n || seen[t]) continue; // 越界 id（词表不匹配）只看不罚
            seen[t] = 1;
            logits[t] =
                (logits[t] > 0.0) ? logits[t] / cfg.repeat_penalty : logits[t] * cfg.repeat_penalty;
        }
    }

    // ── ② 温度 ──
    if (cfg.temperature > 0.0 && cfg.temperature != 1.0)
        for (auto& v : logits)
            v /= cfg.temperature;

    // ── ③ top-k：候选集（升序；未截断时 = 全部下标）──
    std::vector<std::size_t> cand;
    if (cfg.top_k > 0 && cfg.top_k < n)
    {
        std::vector<std::size_t> order(n);
        for (std::size_t i = 0; i < n; ++i)
            order[i] = i;
        std::partial_sort(order.begin(), order.begin() + cfg.top_k, order.end(),
                          [&](std::size_t a, std::size_t b)
                          {
                              if (logits[a] != logits[b]) return logits[a] > logits[b];
                              return a < b; // 并列取小下标（确定性）
                          });
        cand.assign(order.begin(), order.begin() + cfg.top_k);
        std::sort(cand.begin(), cand.end()); // 回到升序（CDF 遍历顺序）
    }
    else
    {
        cand.resize(n);
        for (std::size_t i = 0; i < n; ++i)
            cand[i] = i;
    }

    // ── ④ softmax（遍历顺序 = 候选集升序；未截断时与旧路径逐位一致）──
    Scalar max_val = logits[cand[0]];
    for (std::size_t i = 1; i < cand.size(); ++i)
        max_val = std::max(max_val, logits[cand[i]]);
    Scalar sum_exp = 0.0;
    for (const std::size_t v : cand)
    {
        logits[v] = std::exp(logits[v] - max_val);
        sum_exp += logits[v];
    }

    // ── ⑤ top-p：概率降序找最小前缀，保留集内重新归一化 ──
    if (cfg.top_p < 1.0 && cand.size() > 1)
    {
        std::vector<std::size_t> by_prob(cand);
        std::sort(by_prob.begin(), by_prob.end(),
                  [&](std::size_t a, std::size_t b)
                  {
                      if (logits[a] != logits[b]) return logits[a] > logits[b];
                      return a < b; // 并列取小下标（确定性）
                  });
        const Scalar want = (cfg.top_p > 0.0) ? cfg.top_p : 0.0;
        Scalar cum = 0.0;
        std::size_t keep = 0;
        for (; keep < by_prob.size(); ++keep)
        {
            cum += logits[by_prob[keep]] / sum_exp;
            if (cum >= want)
            {
                ++keep;
                break;
            } // 至少保留 1 个
        }
        if (keep == 0) keep = 1;
        std::vector<std::uint8_t> in_keep(n, 0);
        for (std::size_t i = 0; i < keep; ++i)
            in_keep[by_prob[i]] = 1;
        Scalar kept_sum = 0.0;
        std::vector<std::size_t> kept;
        kept.reserve(keep);
        for (const std::size_t v : cand) // 升序保持 CDF 遍历顺序
            if (in_keep[v])
            {
                kept.push_back(v);
                kept_sum += logits[v];
            }
        for (const std::size_t v : cand)
            if (!in_keep[v]) logits[v] = 0.0;
        cand = std::move(kept);
        sum_exp = kept_sum;
    }
    for (const std::size_t v : cand)
        logits[v] /= sum_exp;

    // ── ⑥ 采样 / 贪心 ──
    if (cfg.temperature > 0.0)
    {
        const Scalar r = dist(rng);
        Scalar cumulative = 0.0;
        std::size_t next = cand.back(); // 逆 CDF 未命中时的兜底（与旧路径 n-1 一致）
        for (const std::size_t v : cand)
        {
            cumulative += logits[v];
            if (r <= cumulative)
            {
                next = v;
                break;
            }
        }
        return next;
    }
    std::size_t next = cand[0];
    Scalar best = logits[cand[0]];
    for (std::size_t i = 1; i < cand.size(); ++i)
        if (logits[cand[i]] > best)
        {
            best = logits[cand[i]];
            next = cand[i];
        }
    return next;
}

// 旧签名（无截断的纯 temperature 采样）：语义 = SamplingConfig 全默认
// ⇒ 输出与旧实现逐位一致（采样器单测锁这条等价性）
[[nodiscard]] inline std::size_t sample_next_token_(std::vector<Scalar>& logits, Scalar temperature,
                                                    std::mt19937_64& rng,
                                                    std::uniform_real_distribution<Scalar>& dist)
{
    SamplingConfig cfg;
    cfg.temperature = temperature;
    return sample_next_token_(logits, cfg, rng, dist, {});
}

} // namespace nn
