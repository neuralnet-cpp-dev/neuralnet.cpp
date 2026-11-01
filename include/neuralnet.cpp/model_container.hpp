#pragma once

// ── model_container.hpp — 引擎化模型容器 ───────────────────────────────────
//
// 架构铁律：
//   1. Model 持有 shared_ptr<ComputeEngine>（强引用），所有 forward/backward 委托给
//      Layer::forward(Tensor) / Layer::backward(Tensor)（M6 段 C 起 engine 由 init 绑定，不再作形参）。
//   2. Model 不包含任何 GPU-resident 中间结果缓存或 forward_gpu/backward_gpu
//      路径 —— 设备分发完全由 ComputeEngine 实现负责。
//   3. forward/backward 操作 Tensor，单套实现适配 CPU/GPU。
//
// 数据流（GPU 训练为例）：
//   Matrix(x_batch) ──engine.from_matrix──▶ Tensor[GPU]
//     ──forward──▶ Tensor[GPU] ──loss.forward──▶ Scalar
//     ──loss.backward──▶ Tensor[GPU] ──backward──▶ (丢弃)
//     ──optimizer.step──▶ 参数就地更新（全程在 GPU）
//   仅 evaluate 时 engine.to_matrix 下载到 CPU 做 argmax。
// ─────────────────────────────────────────────────────────────────────────

#include <cstddef>
#include <memory>
#include <optional>
#include <source_location>
#include <vector>

#include <neuralnet.cpp/core_assert.hpp>
#include "core_domain.hpp"
#include "compute_layer.hpp"
#include "model_spec.hpp"

namespace nn
{

class Model
{
private:
    std::shared_ptr<ComputeEngine> engine_;
    std::vector<std::unique_ptr<Layer>> layers_;
    // 可选架构规格：由 build_*_from_spec 工厂在构建时设置，供 load_model
    // 校验文件头部与模型架构是否一致。为空表示未记录（跳过校验，向后兼容）。
    std::optional<ModelSpec> spec_;

    // 默认精度配置（§9.2）：**设过**才在 add()/add_layer() 的 init 之前注入。
    // 未设 = nullopt → 不动层自己的 profile（否则会把工厂在构造器里已注入的
    // 精度用默认 f32 覆盖掉：GPTModel 等复合层就是"构造器注入 + init 创建权重"
    // 的顺序，覆盖会导致 token_emb 等权重退回 f32）。
    std::optional<PrecisionProfile> default_precision_;

    // 可选通用输出 schema。未设置时，单输出模型沿用最后一层的默认
    // "output" schema；OutputBundleLayer 自带其构造期 schema。
    std::optional<TensorSchema> output_schema_;

public:
    Model() = default;
    explicit Model(ComputeEngine& engine) : engine_(engine.weak_from_this().lock()) {}
    explicit Model(std::shared_ptr<ComputeEngine> engine) : engine_(std::move(engine)) {}

    // 不可拷贝（unique_ptr 语义），可移动
    Model(const Model&) = delete;
    Model& operator=(const Model&) = delete;
    Model(Model&&) noexcept = default;
    Model& operator=(Model&&) noexcept = default;

    // ── 引擎绑定 ─────────────────────────────────────────────────────────
    // D7（15 §4.7，M6 裁定=删除死码）：原 `set_engine(ComputeEngine&)` 全仓
    // 零调用方，且"绑定后换引擎"与"层已在 add() 时 init 绑定"冲突——绑定只经
    // 构造函数 `Model(ComputeEngine&)`（或移动后沿用既有绑定）。
    // 是否已绑定引擎（不触发 fail-fast 的只读查询；TrainingSession::create
    // 等"编排层"在构造前用它做 Result 错误而不是 abort）。
    [[nodiscard]] bool engine_bound() const noexcept { return static_cast<bool>(engine_); }

    [[nodiscard]] ComputeEngine&
    engine(std::source_location loc = std::source_location::current()) const
    {
        if (!engine_)
        {
            const std::string msg =
                "[model-lifetime] Model: 未绑定引擎（构造时引擎必须由 shared_ptr 管理）";
            detail::fatal_at("NN_FATAL", loc.file_name(), static_cast<int>(loc.line()),
                             msg.c_str());
        }
        return *engine_;
    }

    // ── 构建网络（通用模板接口） ────────────────────────────────────────
    // 用法：model.add<Linear>(in, out) / model.add<ReLU>() / ...
    // 注意：构造后自动调用 Layer::init()，无需手动调用。
    // 注意：MultiHeadAttention 的构造函数是 protected（设计为基类，
    //       由 TransformerEncoderLayer / CausalSelfAttention 内部组合），
    //       因此不直接通过 add 添加。
    template <typename LayerType, typename... Args> Result<void> add(Args&&... args)
    {
        auto layer = std::make_unique<LayerType>(std::forward<Args>(args)...);
        if (default_precision_.has_value())
            layer->set_precision_profile(default_precision_.value());
        auto r = layer->init(engine());
        NN_TRY_CHECK(r);
        layers_.emplace_back(std::move(layer));
        return {};
    }

    // 添加已由工厂构造的 Layer（如 make_norm_layer 按 NormType 创建归一化层）
    Result<void> add_layer(std::unique_ptr<Layer> layer)
    {
        if (default_precision_.has_value())
            layer->set_precision_profile(default_precision_.value());
        auto r = layer->init(engine());
        NN_TRY_CHECK(r);
        layers_.emplace_back(std::move(layer));
        return {};
    }

    // 添加已构造的层并**显式**注入给定 profile（跳过 default_precision_）。
    // 用于"同一模型内按层类型分派精度"的场景：三值 MLP 里 BitLinear 要
    // param=T1_58，而非权重层/归一化层的 param 槽不适用（仍走模型默认）。
    // 见 docs/internal/21-quantized-weights.md §4.8。
    Result<void> add_layer(std::unique_ptr<Layer> layer, const PrecisionProfile& profile)
    {
        layer->set_precision_profile(profile);
        auto r = layer->init(engine());
        NN_TRY_CHECK(r);
        layers_.emplace_back(std::move(layer));
        return {};
    }

    // ── 默认精度配置（§9.2）：须在 add()/add_layer() 之前调用 ─────────────
    void set_default_precision_profile(const PrecisionProfile& profile)
    { default_precision_ = profile; }
    [[nodiscard]] const PrecisionProfile& default_precision_profile() const noexcept
    {
        static const PrecisionProfile f32{};
        return default_precision_ ? *default_precision_ : f32;
    }

    // ── 访问 ─────────────────────────────────────────────────────────────
    [[nodiscard]] std::size_t num_layers() const noexcept { return layers_.size(); }

    [[nodiscard]] Layer& layer_at(std::size_t index) noexcept
    {
        // RV-01：越界后 `*layers_[index]` 是越界读 + 空/错层解引用 → 无条件终止
        NN_ASSERT_ALWAYS(index < layers_.size(), "Model::layer_at index out of range");
        return *layers_[index];
    }

    // ── 架构规格（可选）：记录本模型对应的 ModelSpec ────────────────────
    // build_*_from_spec 工厂自动设置；也可手动 set_spec 以启用 load_model 校验。
    void set_spec(const ModelSpec& spec)
    {
        spec_ = spec;
        output_schema_ = spec.output_schema;
    }
    [[nodiscard]] const std::optional<ModelSpec>& spec() const noexcept { return spec_; }

    // ── 具名多输出（docs/internal/31 RL-0）────────────────────────────────
    void set_output_schema(TensorSchema schema)
    {
        output_schema_ = std::move(schema);
        if (spec_) spec_->output_schema = output_schema_;
    }

    [[nodiscard]] Result<TensorSchema> output_schema() const
    {
        if (output_schema_) return *output_schema_;
        if (layers_.empty()) NN_FAIL("Model::output_schema: no layers");
        return layers_.back()->output_schema();
    }

    // ── D7：精度配置注入（§9.2）：设置所有顶层 Layer 的精度 ──
    // 对 GPTModel/RAPTModel 等复合层，精度在构造时已传播到子层；
    // 对 MLP/Transformer/CNN 等简单层列表，精度直接设置。
    void set_precision_profile(const PrecisionProfile& profile)
    {
        for (auto& layer : layers_)
            layer->set_precision_profile(profile);
    }

    // ── batch 录制粒度：在 Transformer block 间按间隔 flush ──
    // 通过 Layer 基类虚函数分发：GPTModel override 生效，
    // 其他层类型默认 no-op。
    void set_flush_interval(std::size_t interval)
    {
        for (auto& layer : layers_)
            layer->set_flush_interval(interval);
    }

    // ── 梯度检查点（激活重计算 L1）：按间隔配置各层 ──
    // 通过 Layer 基类虚函数分发：GPTModel override 生效，
    // 其他层类型默认 no-op。
    void set_checkpoint_every(std::size_t stride)
    {
        for (auto& layer : layers_)
            layer->set_checkpoint_every(stride);
    }

    // ── activation offload（L1-offload）：把激活搬 host-visible ──
    // 通过 Layer 基类虚函数分发：GPTModel override 生效，
    // 其他层类型默认 no-op。
    void set_activation_offload(bool enabled)
    {
        for (auto& layer : layers_)
            layer->set_activation_offload(enabled);
    }

    // 理论 offload RAM 字节数（各层累计，用于诊断）
    [[nodiscard]] std::size_t offload_ram_bytes()
    {
        std::size_t total = 0;
        for (auto& layer : layers_)
            total += layer->offload_ram_bytes();
        return total;
    }

    // ── 训练/推理模式切换：转发给各 Layer（BatchNorm 等需要区分） ──
    void set_training(bool training)
    {
        for (auto& layer : layers_)
            layer->set_training(training);
    }

    // ── 文档感知：设置当前 step 每样本文档 id（转发给各 Layer） ─────────
    // GPTModel override 生效；其他层默认 no-op。
    void set_doc_ids(std::span<const std::size_t> ids)
    {
        for (auto& layer : layers_)
            layer->set_doc_ids(ids);
    }

    // ── 前向传播：Tensor → Tensor（全程不离开 engine 设备） ───────────────
    [[nodiscard]] Result<Tensor> forward(const Tensor& input)
    {
        if (layers_.empty()) NN_FAIL("Model::forward: no layers");
        if (!engine_) NN_FAIL("Model::forward: engine 未绑定（构造时引擎必须由 shared_ptr 管理）");
        // GPU 单次推理自动 batch 作用域（issue #28）：外层未持有 batch 时
        // 临时开一个，多 Conv 模型不再因逐原语路径不回收帧内分配而
        // VK_ERROR_OUT_OF_DEVICE_MEMORY。外层训练循环已持有 batch → 透传。
        InferenceScope scope(*engine_);
        if (!scope.ok()) NN_FAIL("Model::forward: " + scope.error().message);
        Tensor x = input;
        for (std::size_t li = 0; li < layers_.size(); ++li)
        {
            NN_PROF_SCOPE(nn::prof::interned("fwd.layer", li));
            auto r = layers_[li]->forward(x);
            NN_TRY_CHECK(r);
            x = std::move(*r);
        }
        return x;
    }

    // ── 反向传播：Tensor → Tensor（从最后一层到第一层） ───────────────────
    [[nodiscard]] Result<Tensor> backward(const Tensor& grad_output)
    {
        if (layers_.empty()) NN_FAIL("Model::backward: no layers");
        if (!engine_) NN_FAIL("Model::backward: engine 未绑定（构造时引擎必须由 shared_ptr 管理）");
        // 同 forward（issue #28）：外层未持有 batch 时临时开一个。
        InferenceScope scope(*engine_);
        if (!scope.ok()) NN_FAIL("Model::backward: " + scope.error().message);
        Tensor g = grad_output;
        for (std::size_t i = layers_.size(); i-- > 0;)
        {
            NN_PROF_SCOPE(nn::prof::interned("bwd.layer", i));
            auto r = layers_[i]->backward(g);
            NN_TRY_CHECK(r);
            g = std::move(*r);
        }
        return g;
    }

    // ── 具名 forward/backward：中间层仍走单 Tensor，最后一层可展开多端口 ──
    [[nodiscard]] Result<NamedTensorSet> forward_named(const Tensor& input)
    {
        if (layers_.empty()) NN_FAIL("Model::forward_named: no layers");
        if (!engine_) NN_FAIL("Model::forward_named: engine 未绑定");
        NN_TRY(schema, output_schema());

        Tensor x = input;
        for (std::size_t li = 0; li + 1 < layers_.size(); ++li)
        {
            NN_PROF_SCOPE(nn::prof::interned("fwd_named.layer", li));
            NN_TRY(out, layers_[li]->forward(x));
            x = std::move(*out);
        }
        NN_PROF_SCOPE(nn::prof::interned("fwd_named.layer", layers_.size() - 1));
        return layers_.back()->forward_named(x, *schema);
    }

    [[nodiscard]] Result<Tensor> backward_named(const GradientBundle& gradients)
    {
        if (layers_.empty()) NN_FAIL("Model::backward_named: no layers");
        if (!engine_) NN_FAIL("Model::backward_named: engine 未绑定");
        NN_TRY(schema, output_schema());

        NN_TRY(last_grad, layers_.back()->backward_named(gradients, *schema));
        Tensor g = std::move(*last_grad);
        for (std::size_t i = layers_.size() - 1; i-- > 0;)
        {
            NN_PROF_SCOPE(nn::prof::interned("bwd_named.layer", i));
            NN_TRY(out, layers_[i]->backward(g));
            g = std::move(*out);
        }
        return g;
    }

    // ── 参数收集：返回 TensorRef 供 Optimizer 使用 ──────────────────────────
    [[nodiscard]] std::vector<TensorRef> parameters()
    {
        std::vector<TensorRef> result;
        for (auto& layer : layers_)
        {
            auto layer_params = layer->parameters();
            result.insert(result.end(), layer_params.begin(), layer_params.end());
        }
        return result;
    }

    // ── 非可学习状态收集（如 BatchNorm 的 running 统计量，供序列化） ────────
    [[nodiscard]] std::vector<TensorRef> extra_state()
    {
        std::vector<TensorRef> result;
        for (auto& layer : layers_)
        {
            auto layer_extra = layer->extra_state();
            result.insert(result.end(), layer_extra.begin(), layer_extra.end());
        }
        return result;
    }

    [[nodiscard]] std::vector<TensorRef> param_gradients()
    {
        std::vector<TensorRef> result;
        for (auto& layer : layers_)
        {
            auto layer_grads = layer->param_gradients();
            result.insert(result.end(), layer_grads.begin(), layer_grads.end());
        }
        return result;
    }

    // ── 梯度清零（每个训练 step 开头调用） ────────────────────────────────
    [[nodiscard]] Result<void> zero_grad()
    {
        for (auto& layer : layers_)
        {
            auto r = layer->zero_grad();
            if (!r) return r;
        }
        return {};
    }
};

// ── model_warmup：跑一遍代表性 forward，把用到的表达式现编进 .nnk 缓存 ──
// Phase 2 运行期 JIT（docs/internal/33 §5）：对无内嵌注册表（消费方未跑 scan_exprs）
// 的构建，每次 GPU dispatch 都是 JIT miss（有编译延迟）；预热一次后，该模型
// 用到的全部表达式都现编并持久化进缓存，后续真实推理/训练为缓存命中（无延迟）。
// 输入必须为该架构的代表性形状（MLP: (input_dim, batch)；GPT: (d_model, batch*seq)；
// CNN: (C, H*W×batch)…——调用方按自己模型构造）。forward 走引擎已有绑定
// （Layer::init(engine)），此函数只负责触发一次求值并落缓存。
[[nodiscard]] inline Result<void> model_warmup(Model& model, const Tensor& input)
{
    auto out = model.forward(input);
    if (!out) return std::unexpected(out.error());
    return {};
}

} // namespace nn
