#pragma once

// ═══════════════════════════════════════════════════════════════════════════
//  expr_dsl.hpp — 统一表达式 DSL（编译期模板，唯一前端）
//
//  目标：所有逐元素计算都用"普通数学写法"写出，编译期融合：
//      auto e = leaf(q) * row_mod(cos, dk) + rotate_half(leaf(q), dk) * row_mod(sin, dk);
//      engine.compute(e, rows, cols);
//
//  单一事实来源 = 这一整段表达式本身（编译期类型）。两个消费方共用：
//    1. CPU：直接把表达式当作编译期 AST，逐元素求值 → 编译器内联 + SIMD 融合，
//       等价手写 for 循环（零开销抽象）。
//    2. GPU（AOT，无运行时生成）：to_expr_spec(expr) 在编译期把同一表达式折叠
//       成扁平 ExprSpec → 与预生成融合 shader 比对 → dispatch。
//
//  AOT 注册表约定：代码里用到的表达式集合 = 构建期 AOT 生成的 shader 集合
//  （预热加速器）。运行时未命中默认走运行期 JIT 现编兜底；NN_STRICT_CLOSED_WORLD=1
//  恢复硬报错（把"难以察觉的漂移"变成"可选的立即暴露"）。
//
//  设计要点：
//    - 算子复用 nn::ops（唯一的算子来源，op_id() 统一映射到 ExprOp）。
//    - 叶子持有 Tensor（零拷贝 shared_ptr）；视图（RotateHalf/RowMod）是索引
//      映射叶子，不物化中间张量。
//    - 运算符重载/概念约束：普通 + - * / 与比较、select 均照常书写。
// ═══════════════════════════════════════════════════════════════════════════

#include <algorithm>
#include <cmath>
#include <concepts>
#include <cstdint>
#include <cstdio>
#include <cstdlib>
#include <limits>
#include <ranges>

#include <neuralnet.cpp/core_config.hpp>   // NN_PROBES_ENABLED（探针编译门）
#include <neuralnet.cpp/core_parallel.hpp>   // nn::parallel_for_samples
#include "core_domain.hpp"
#include "core_env.hpp"      // RV-09：环境变量读取唯一入口

namespace nn::dsl
{
// 环境变量开关（RV-09：实现收敛到 core_env.hpp；本函数保留 dsl 门面名，
// 供 layer/engine 侧的诊断开关调用）。
// ⚠ 探针门：默认构建（未 -DNN_ENABLE_PROBES=ON）里恒返回 false 且**不求值 getenv**
//   → 调用点被编译期折叠，"NN_F16_DEBUG" 之类的诊断开关不会在正常训练里生效。
inline bool env_flag(const char* name)
{ return ::nn::detail::probe_flag_raw(name); }
} // namespace nn::dsl
#include <utility>
#include <vector>

#include "compute_tensor.hpp"
#include "compute_engine.hpp"
#include <neuralnet.cpp/core_assert.hpp>
#include "expr_spec.hpp"
#include "expr_registry.hpp"
#include "algebra_ops.hpp"    // nn::ops（唯一算子来源，含 op_id()）
#include "algebra_matrix.hpp" // Matrix

// ── 表达式概念 nn::Expression / nn::BoolExpression（RV-13：定义已移到 L1 的
//    algebra_span.hpp——它描述的是 L1 原语的契约；本头经 algebra_matrix.hpp
//    → algebra_span.hpp 传递可见）────────────────────────────────────────

namespace nn::dsl
{

// M1（docs/internal/17 §4.1）：Tensor 存储访问已私有化，DSL 求值器经
// 引擎域内通道 detail::TensorAccess 创建/读写张量（friend 关系，库外禁用）。
using TensorAccess = ::nn::detail::TensorAccess;

// ── DSL 逐元素模板路径的并行门控 ────────────────────────────────────────
// 低于全局 nn::PARALLEL_THRESHOLD(524288)。全局值按"裸逐元素 add 的内存
// 带宽回本点"标定；而本路径折叠的是多算子融合表达式（每元素 2~6 次算术，
// 还可能含 exp/tanh/sqrt），per-element 成本更高，回本点更低。
// LayerNorm/RMSNorm 的典型形状 768×512 = 393216 低于全局门控 → 若按全局
// 门控判定会整段串行，故本路径需要更低的专属门控。
// 131072 元素 × ~2ns ≈ 0.26ms，远超并行区启动开销（实测 ~100µs）。
inline constexpr std::size_t kDslParallelThreshold = 131072;

// ══════════════════════════════════════════════════════════════════════════
// 内部求值/折叠构建器：把编译期表达式折叠成扁平 ExprSpec + 输入张量列表
// ══════════════════════════════════════════════════════════════════════════
struct SpecBuilder
{
    ExprSpec spec;
    std::vector<Tensor> inputs;

    ExprOperand add_const(Scalar v)
    {
        spec.consts.push_back(v);
        return expr::cst(static_cast<std::uint8_t>(spec.consts.size() - 1));
    }
    // 运行时标量参数（RParam）：值作为运行时数据存入 spec.rparams，不进
    // expr_spec_key；同结构不同值共享一个融合 shader（glsl_gen 把 rparams
    // 作为 push constant 读取，dispatch 时按实际 spec 填充）。用于优化器的
    // lr/eps/β、偏差修正系数等每步会变、但结构固定的标量。
    ExprOperand add_rparam(Scalar v)
    {
        spec.rparams.push_back(v);
        return expr::rval(static_cast<std::uint8_t>(spec.rparams.size() - 1));
    }
    // ── 中心化输入登记（含去重）─────────────────────────────────────────
    // 同一张量（same_storage：同设备/精度/存储/形状）+ 同一视图 → 复用已有
    // 槽，不新增绑定。收益（GPU/IR 路径）：
    //   ① 归约视图只算一遍——RowReduceMax 这类视图在归约生成器里各占一个
    //      全矩阵 pass，重复槽 = 白读一遍 S（反传 W 重算的 softmax 实测
    //      4 槽 → 2 槽、行 max pass 减半，见 docs/history 本条）；
    //   ② 输入下标一致后 CSE 才能把重复子链合并（两次 leaf(S)-rowmax(S)
    //      此前因操作数下标不同而永不合并）；
    //   ③ 绑定/描述符更少。
    // **仅对有效张量判同**：锚点符号实例（FusedAnchor 的占位张量，无存储）
    // 一律不合并——锚点侧结构由 dry-run/模型 pass 的真实张量路径覆盖，
    // 两侧走同一 SpecBuilder，保证扫描期登记与运行期 key 一致。
    // RowGather 这类"登记后改写视图"的调用方必须传 dedup=false：
    // 若复用已有槽再覆写 views[i]，会污染原输入的视图。
    ExprOperand add_input(const Tensor& t, const ExprView& v, bool dedup = true)
    {
        if (dedup)
        {
            for (std::size_t i = 0; i < inputs.size(); ++i)
                if (spec.views[i] == v && inputs[i].same_storage(t))
                    return expr::input(static_cast<std::uint8_t>(i));
        }
        spec.views.push_back(v);
        inputs.push_back(t);
        return expr::input(static_cast<std::uint8_t>(inputs.size() - 1));
    }
    ExprOperand add_input_linear(const Tensor& t, bool dedup = true)
    { return add_input(t, expr::linear(), dedup); }
    ExprOperand add_input_rotate(const Tensor& t, std::uint32_t block)
    { return add_input(t, expr::rotate_half(block, /*negate_first_half=*/true)); }
    ExprOperand add_input_rowmod(const Tensor& t, std::uint32_t mod)
    { return add_input(t, expr::row_mod(mod)); }
    ExprOperand add_input_rowaccess(const Tensor& t, std::uint32_t offset, std::uint32_t mod)
    { return add_input(t, expr::row_access(offset, mod)); }
    // 分组归约视图输入：输出 (G,N)、输入 (G*R,N)，out[r][c] = Σ/max over
    // t<R of in[(r*R+t)][c]。R = 组长度，**运行期视图参数**（vp 槽，不进
    // expr_spec_key）：glsl_gen 发运行期循环 `gr_r<i>(row,col)`（见
    // ExprViewKind::GroupedReduce* 注释）。
    ExprOperand add_input_grouped_reduce(const Tensor& t, std::uint32_t R, bool is_max)
    {
        ExprView v;
        v.kind = static_cast<std::uint8_t>(is_max ? ExprViewKind::GroupedReduceMax
                                                  : ExprViewKind::GroupedReduceSum);
        v.param = R;
        return add_input(t, v);
    }
    // 归约视图输入：该输入被归约为每行/每列一个标量（(rows,1)/(1,cols)），
    // 求值期自动广播——参与算术时按当前 (r,c) 读取对应标量。
    ExprOperand add_reduce_input(const Tensor& t, ExprViewKind kind)
    {
        ExprView v;
        v.kind = static_cast<std::uint8_t>(kind);
        return add_input(t, v);
    }
    // 归约指令：对某表达式结果（操作数 a）归约 → 隐式"每行/每列一个标量"
    // 的归约向量，后续指令经 Reduce 操作数按行/列广播访问。
    ExprOperand add_reduce_instr(ExprOp op, ExprOperand a)
    {
        ExprInstr in;
        in.op = static_cast<std::uint8_t>(op);
        in.dst = static_cast<std::uint8_t>(spec.num_regs++);
        in.a = a;
        spec.instrs.push_back(in);
        return expr::reduce(in.dst);
    }
    // 广播视图：输入本身已是 (rows,1)/(1,cols) 小向量，按行/列广播
    ExprOperand add_input_rowbroadcast(const Tensor& t)
    { return add_input(t, expr::row_broadcast()); }
    ExprOperand add_input_colbroadcast(const Tensor& t)
    { return add_input(t, expr::col_broadcast()); }
    ExprOperand add_instr(ExprOp op, ExprOperand a, ExprOperand b = {}, ExprOperand c = {})
    {
        ExprInstr in;
        in.op = static_cast<std::uint8_t>(op);
        in.dst = static_cast<std::uint8_t>(spec.num_regs++);
        in.a = a;
        in.b = b;
        in.c = c;
        spec.instrs.push_back(in);
        return expr::reg(in.dst);
    }
};

// ══════════════════════════════════════════════════════════════════════════
// 编译期求值的"输出列数感知"分发：eval_with_cols
//
// nn::Expression 的契约是 eval(i)：只有一个扁平下标，**不知道输出列数**。
// 大部分叶子是列数无关的（Linear/RotateHalf/RowMod/RowAccess 都能从自身
// 张量推出列数），但有一类视图必须知道"输出列数"才能把扁平下标还原成
// (row, col)：RowBroadcast（输入 (rows,1)，读第 i/cols 个标量）。这类节点
// 额外提供 eval(i, cols)；复合节点把 cols 透传给子节点：
//   eval_with_cols(child, i, cols)：子节点有 2 参 eval 就用它，否则退回 eval(i)。
//
// 只有真正需要"全行/全列"信息（归约视图/归约指令/matmul/网格索引）的表达式
// 才走引擎解释器（由 has_reduction_v 分流）；纯索引映射（含广播视图）留在
// 模板求值路径 → 编译器内联 + 与其它逐元素路径共用同一并行门控。
// ══════════════════════════════════════════════════════════════════════════
template <typename T>
concept ColsAwareEval = requires (const T& t, std::size_t i, std::size_t cols) {
    { t.eval(i, cols) } -> std::convertible_to<Scalar>;
};

template <typename E>
[[nodiscard]] Scalar eval_with_cols(const E& e, std::size_t i, std::size_t cols)
{
    if constexpr (ColsAwareEval<E>) return static_cast<Scalar>(e.eval(i, cols));
    else return static_cast<Scalar>(e.eval(i));
}

// ══════════════════════════════════════════════════════════════════════════
// eval_into_span — 把逐元素表达式写进既有 span（eval_cpu / compute_into 共用）
//
// 与逐元素原语（algebra_matrix 的 apply/transform/原地运算）**同构**：
//   - n < kDslParallelThreshold：串行计数循环 + NN_VECTORIZE_PRAGMA
//   - n ≥ kDslParallelThreshold：自建分块并行，块内同样是**带向量化提示的裸
//     指针计数循环**（不用 nn::for_each(iota)：其分块内层在池里，无法为该
//     循环单独加向量化提示——池被多种读写模式复用，不能全局 assume_safety；
//     实测大张量下慢 1.3–1.5 倍）
// NN_VECTORIZE_PRAGMA（clang `loop vectorize(assume_safety)` / GCC ivdep）是
// 关键：内层循环读写的是多个"来源未知"的指针（目标 + 各叶子），编译器无法
// 证明互不别名；不给提示时不向量化，实测逐元素 add 慢 3 倍以上。
// 语义安全性：本循环是纯 map —— 每个输出元素只依赖**同一下标**的输入，
// 先读完再写回。无论目标是否与某输入同 buffer，向量化后的"载入同下标向量
// →计算→存回"与串行逐一读改写逐字节一致（无跨下标依赖）。
//
// 门控说明：这里用 kDslParallelThreshold（131072）而非全局 PARALLEL_THRESHOLD
// （524288）。全局值是按"裸 add 的内存带宽回本点"标的；而本路径折叠的是
// 多算子融合表达式（每元素 2~6 次算术 + 可能的 exp/tanh），per-element 成本
// 更高，回本点更低。典型 LayerNorm/RMSNorm 形状 768×512=393216 正好低于
// 524288——按全局门控会**整段串行**（归一化层将只用 ~1 核），故本路径
// 取更低的专属门控。
// ══════════════════════════════════════════════════════════════════════════
template <typename E> inline void eval_into_span(const E& e, Span d_span, std::size_t cols) noexcept
{
    Scalar* d = d_span.data();
    const std::size_t n = d_span.size();
    if (n == 0) return;
    if (n < kDslParallelThreshold)
    {
        NN_VECTORIZE_PRAGMA
        for (std::size_t i = 0; i < n; ++i)
            d[i] = eval_with_cols(e, i, cols);
        return;
    }

    const std::size_t hw = static_cast<std::size_t>(std::thread::hardware_concurrency());
    // 分块数：以 ~64K 元素/块为目标，上限 hw*4 以保证负载均衡。
    // 65536 的取值依据（层级别实测裁决）：更小的分块（4096/16384）在隔离
    // kernel 上有收益但层级别反而变差（layernorm 2.8→3.2ms、rmsnorm
    // 1.7→1.9ms）——隔离内核的收益不会传递到层；再调整必须先有层级别证据。
    // 并行区固定开销实测 ~100µs（32 线程）/ ~3~16µs（≤16 线程）。
    constexpr std::size_t TARGET_CHUNK = std::size_t{1} << 16;
    const std::size_t n_chunks =
        std::clamp(n / TARGET_CHUNK, std::size_t{1}, std::max<std::size_t>(hw, 1) * 4);
    const std::size_t base = n / n_chunks;
    const std::size_t rem = n % n_chunks;
    nn::parallel_for_samples(n_chunks,
                             [&e, d, cols, base, rem](std::size_t c) noexcept
                             {
                                 const std::size_t off = c * base + std::min(c, rem);
                                 const std::size_t len = base + (c < rem ? 1 : 0);
                                 Scalar* dc = d + off;
                                 NN_VECTORIZE_PRAGMA
                                 for (std::size_t k = 0; k < len; ++k)
                                     dc[k] = eval_with_cols(e, off + k, cols);
                             });
}
// ══════════════════════════════════════════════════════════════════════════
// CpuViewCache — 叶子节点的 CPU 数据视图缓存
//
// 逐元素模板求值会**按元素**读取叶子（e.eval(i)）。若每个元素都重新
// t.cpu_matrix().span()，会引入固定开销：variant 槽检查 + span 构造 ——
// 实测使模板路径比等价手写循环慢 1.5–4 倍（原地原语只做一次指针遍历）。
// 因此在叶子构造时缓存一次数据视图（ConstSpan 只是 (指针, 长度)，16 字节）。
//
// 非 CPU 张量（GPU）**不**触发 cpu_matrix()：GPU 路径只走 to_spec 折叠，
// 从不调用 eval；此时缓存留空，eval 走兜底（理论上不会到达该分支）。
// ══════════════════════════════════════════════════════════════════════════
struct CpuViewCache
{
    // CPU 张量的数据指针与列数（构造时缓存一次）。非 CPU 张量（GPU）留空：
    // GPU 路径只走 to_spec 折叠，从不调用 eval。
    // 用裸指针而非 ConstSpan：at() 必须**无分支**，否则编译器无法向量化
    // 内层循环（实测带 `empty() ? ... : ...` 兜底分支时原地 add 慢 5 倍）。
    const Scalar* data = nullptr;
    std::size_t cols = 0;

    // f16 源：§7.2 定义下 f16 的逐元素语义 = "f32 参考计算 + 输出舍入"，故
    // 求值前把 f16 叶子**一次性**抬到 f32 副本，at() 仍是无分支的 f32 读。
    // （把 f16 转换塞进 at() 会给 f32 热路径引入每元素分支 → 实测同类分支
    //   使模板路径慢 3-5 倍，不可接受；这里用一次 O(n) 转换换零热路径代价。）
    std::shared_ptr<Matrix> f32_view;

    void cache_cpu_view(const Tensor& t)
    {
        if (!t.is_cpu()) return;
        // 符号张量（默认构造：未绑定、无存储）——AOT 自登记需要"从表达式类型
        // 折叠出结构"，那条路径只看 to_spec 折出的视图/指令，不会 eval；此处
        // 直接返回，避免在无存储张量上取 CPU 视图（原会 NN_ASSERT 硬失败）。
        if (!t.valid()) return;
        if (t.precision() == Precision::F16)
        {
            auto m = std::make_shared<Matrix>(t.rows(), t.cols());
            const auto s = TensorAccess::cpu_matrix<Precision::F16>(t).span();
            auto d = m->span();
            for (std::size_t i = 0; i < s.size(); ++i)
                d[i] = static_cast<Scalar>(s[i]);   // 升 cast：精确无损
            f32_view = std::move(m);
            data = f32_view->span().data();
            cols = t.cols();
            return;
        }
        const auto& m = TensorAccess::cpu_matrix(t);
        data = m.span().data();
        cols = t.cols();
    }
    [[nodiscard]] Scalar at(std::size_t i) const
    {
        // RV-01：失败后 `data[i]` 是空指针解引用 → 无条件终止
        NN_ASSERT_ALWAYS(data != nullptr,
                         "DSL 叶子 eval 仅适用于 CPU 张量（GPU 路径走 to_spec 折叠）");
        return data[i];
    }
};

// ══════════════════════════════════════════════════════════════════════════
// 叶子节点（同时满足 nn::Expression：可 eval(i)；以及可 to_spec(SpecBuilder&)）
// ══════════════════════════════════════════════════════════════════════════

// 标量常量
struct ConstLeaf
{
    Scalar value;

    [[nodiscard]] constexpr Scalar eval(std::size_t) const noexcept { return value; }
    ExprOperand to_spec(SpecBuilder& b) const { return b.add_const(value); }
};

// 运行时标量参数叶子（RParam）：常量与运行时的折中。值参与算术但**不进
// expr_spec_key**（非表达式结构），glsl_gen 把 rparams 作为 push constant
// 读取；CPU 求值用 spec.rparams[idx]。适配"每步会变的标量"（优化器超参）。
struct RParamLeaf
{
    Scalar value;

    [[nodiscard]] constexpr Scalar eval(std::size_t) const noexcept { return value; }
    ExprOperand to_spec(SpecBuilder& b) const { return b.add_rparam(value); }
};

// 线性叶子：直接读取 Tensor 数据（row-major 扁平）
struct TensorRef : CpuViewCache
{
    Tensor t;

    TensorRef(Tensor tt) : t(std::move(tt)) { cache_cpu_view(t); }
    // 符号实例（AOT 自登记 `FusedAnchor<Expr>`）：`t` 默认构造（未绑定、无存储，
    // cache_cpu_view 对 !valid() 直接返回）——结构只由类型决定
    TensorRef() = default;
    [[nodiscard]] Scalar eval(std::size_t i) const { return at(i); }
    ExprOperand to_spec(SpecBuilder& b) const { return b.add_input_linear(t); }
};

// 视图：RotateHalf —— 按 block 分块，块内前后半行交换 + 前半取负（LLaMA rotate_half）
struct RotateHalfRef : CpuViewCache
{
    Tensor t;
    std::uint32_t block = 1;   // 运行时视图参数（不进 key）；默认值供符号实例

    RotateHalfRef(Tensor tt, std::uint32_t blk) : t(std::move(tt)), block(blk)
    { cache_cpu_view(t); }
    // 符号实例（AOT 自登记）：结构由类型决定，视图参数取中性值（不进 key）
    RotateHalfRef() = default;

    [[nodiscard]] Scalar eval(std::size_t i) const
    {
        const std::size_t c = i % cols, r = i / cols;
        const std::size_t blk = block;
        const std::size_t rl = r % blk;
        const std::size_t rr = (r / blk) * blk + ((rl < blk / 2) ? (rl + blk / 2) : (rl - blk / 2));
        const Scalar v = at(rr * cols + c);
        return (rl < blk / 2) ? -v : v;
    }
    ExprOperand to_spec(SpecBuilder& b) const { return b.add_input_rotate(t, block); }
};

// 视图：RowMod —— 行取模广播（频率表平铺到多行块）
struct RowModRef : CpuViewCache
{
    Tensor t;
    std::uint32_t mod = 1;   // 运行时视图参数（不进 key）；默认值供符号实例

    RowModRef(Tensor tt, std::uint32_t m) : t(std::move(tt)), mod(m) { cache_cpu_view(t); }
    // 符号实例（AOT 自登记）：结构由类型决定，视图参数取中性值（不进 key）
    RowModRef() = default;

    [[nodiscard]] Scalar eval(std::size_t i) const
    {
        const std::size_t c = i % cols, r = i / cols;
        return at((r % mod) * cols + c);
    }
    ExprOperand to_spec(SpecBuilder& b) const { return b.add_input_rowmod(t, mod); }
};

// 视图：RowAccess —— 行偏移+取模访问：data[(offset + r % mod)*cols + c]
// 用于 SwiGLU 等"同一 (2·d_ff) 输入按半个偏移读取"的行切分：
//   gate = row_access(in, offset=0,      mod=d_ff) → in[r % d_ff]
//   up   = row_access(in, offset=d_ff,   mod=d_ff) → in[d_ff + r % d_ff]
// offset/mod 均为运行时形状数据（共享一个融合 shader，运行时经 vp 槽填充）。
struct RowAccessRef : CpuViewCache
{
    Tensor t;
    std::uint32_t offset = 0;   // 运行时视图参数（不进 key）；默认值供符号实例
    std::uint32_t mod = 1;      // 同上

    RowAccessRef(Tensor tt, std::uint32_t off, std::uint32_t m)
        : t(std::move(tt)), offset(off), mod(m)
    { cache_cpu_view(t); }
    // 符号实例（AOT 自登记）：结构由类型决定，视图参数取中性值（不进 key）
    RowAccessRef() = default;

    [[nodiscard]] Scalar eval(std::size_t i) const
    {
        const std::size_t c = i % cols, r = i / cols;
        return at((offset + (r % mod)) * cols + c);
    }
    ExprOperand to_spec(SpecBuilder& b) const { return b.add_input_rowaccess(t, offset, mod); }
};

// 视图：GroupedReduce —— 沿行按固定长度 R 分组归约（segmented reduce）
//   输出网格 (G, N)，输入 (G*R, N)（G = 输入行数 / R；列数两侧相同）：
//     out[g][c] = Σ_{t<R} in[(g*R + t)][c]          （sum）
//     out[g][c] = max_{t<R} in[(g*R + t)][c]         （max）
//   用途：MaxPool2D 的窗口归约（R = pool 窗口 k*k，G = 通道数）。
//
// 求值路径：**非归约**（has_reduction_v = false）——每输出元素只读 R 个
//   相邻输入行、元素间零依赖，CPU 走编译期模板路径（并行+向量化），GPU 走
//   elementwise 生成（glsl_view_read 展开 R 次读取链）。不触发
//   expr_spec_reduce_axis / reduce-shader 分派（输出是全网格而非归约向量）。
//   累加顺序：t 升序左结合链，CPU/GPU/解释器三端一致（铁律 8）。
//   IsMax 是**模板参数**（决定视图 kind = 结构），不是运行期成员：
//   0-sum / 1-max 是两种不同视图（`ExprViewKind::GroupedReduceSum/Max`），
//   而"结构 = 表达式类型"是 AOT 自登记（`FusedAnchor<Expr>` 默认构造符号实例）
//   的前提——运行期 bool 会让两种视图同类型、结构不可枚举。
//   r_len（R）是运行期视图参数，不进 expr_spec_key（见 expr_spec.hpp）。
template <bool IsMax> struct GroupedReduceRef : CpuViewCache
{
    Tensor t;
    std::uint32_t r_len = 1;   // 组长度 R（运行期视图参数，不进 expr_spec_key）

    GroupedReduceRef(Tensor tt, std::uint32_t R) : t(std::move(tt)), r_len(R) { cache_cpu_view(t); }
    // 符号实例（AOT 自登记）：结构由类型决定，R 取中性值（不进 key）
    GroupedReduceRef() = default;

    // 输入 cols = 输出 cols（分组只沿行方向）→ 缓存 cols 即可分解 (g, c)
    [[nodiscard]] Scalar eval(std::size_t i) const
    {
        const std::size_t g = i / cols, c = i % cols;
        Scalar acc = IsMax ? std::numeric_limits<Scalar>::lowest() : Scalar{0};
        const std::size_t base = g * static_cast<std::size_t>(r_len);
        for (std::uint32_t tt = 0; tt < r_len; ++tt)
        {
            const Scalar v = at((base + tt) * cols + c);
            if (IsMax)
            {
                if (v > acc) acc = v;
            }
            else
            {
                acc += v;
            }
        }
        return acc;
    }
    // 2 参版本：cols 语义与 1 参相同（输入/输出同列），转发即可
    [[nodiscard]] Scalar eval(std::size_t i, std::size_t) const { return eval(i); }
    ExprOperand to_spec(SpecBuilder& b) const
    { return b.add_input_grouped_reduce(t, r_len, IsMax); }
};

using GroupedReduceSumRef = GroupedReduceRef<false>;
using GroupedReduceMaxRef = GroupedReduceRef<true>;

// ══════════════════════════════════════════════════════════════════════════
// 归约叶子：把"按行/按列归约出标量向量"接入表达式
//
// 两类（对应 expr_spec.hpp 的归约视图与归约指令两种机制）：
//   1. ReduceViewRef<Kind>：对输入 Tensor 直接归约 → 归约**视图**。
//      求值期代表一个 (rows,1)/(1,cols) 的广播向量，参与算术时自动广播。
//   2. ReduceRef<E, Rop>：对子表达式结果归约 → 归约**指令**，
//      用于 exp(x) 求和这类"表达式内部归约"（见 DslExpr 概念定义之后）。
//
// 含归约的表达式**不实例化**模板 CPU 求值路径（has_reduction_v 把 dsl::compute
// 分流到引擎 eval_expr，由引擎实现归约视图/指令语义），故 eval 仅需满足
// nn::Expression 概念约束，返回占位值。
// ══════════════════════════════════════════════════════════════════════════
template <ExprViewKind Kind> struct ReduceViewRef
{
    // 归约轴与算子：行归约 → 向量长度 rows；列归约 → 长度 cols
    static constexpr bool reduces_rows =
        (Kind == ExprViewKind::RowReduceSum || Kind == ExprViewKind::RowReduceMax);
    static constexpr bool reduces_max =
        (Kind == ExprViewKind::RowReduceMax || Kind == ExprViewKind::ColReduceMax);

    Tensor t;

    // ── CPU 模板路径预绑定（引擎内部，Layer 无感知）─────────────────────
    // 由 cpu_prepare 按输出槽算出行/列归约向量并绑定指针；随后 eval(i, cols)
    // 按 (r, c) 读取该向量。槽内沿归约轴升序累加 → 与解释器的 view_reduce
    // 预计算逐字节一致（铁律 8：并行只是把独立槽分给不同线程）。
    // GPU/scan 不使用本状态（to_spec 只读 t 与 Kind）。
    mutable std::vector<Scalar> vec_{};
    mutable const Scalar* v_ = nullptr;

    [[nodiscard]] constexpr Scalar eval(std::size_t) const noexcept { return Scalar{0}; }
    // CPU 模板路径（2 参）：归约视图按行/列广播
    [[nodiscard]] Scalar eval(std::size_t i, std::size_t cols) const noexcept
    {
        if (v_ == nullptr) return Scalar{0};
        return reduces_rows ? v_[i / cols] : v_[i % cols];
    }
    ExprOperand to_spec(SpecBuilder& b) const { return b.add_reduce_input(t, Kind); }
};

using RowReduceSumRef = ReduceViewRef<ExprViewKind::RowReduceSum>;
using RowReduceMaxRef = ReduceViewRef<ExprViewKind::RowReduceMax>;
using ColReduceSumRef = ReduceViewRef<ExprViewKind::ColReduceSum>;
using ColReduceMaxRef = ReduceViewRef<ExprViewKind::ColReduceMax>;

// ══════════════════════════════════════════════════════════════════════════
// matmul 叶子（算子融合二期：matmul 参与 IR 融合）
//
// matmul(A, B) 折叠成 ExprSpec 的**前置 matmul 段**（MatmulSpec）：
//   逐元素链经 Matmul 操作数按 (r,c) 读取 C = op(A,B)，中间结果不物化。
// A/B 在折叠时登记为输入（Linear 视图），槽位记录进 MatmulSpec.a_input/b_input
// （折叠顺序决定槽位，MatmulRef::to_spec 记录实际槽位，不假设 0/1）。
// k（求和维度）是形状参数：不进 expr_spec_key，同结构不同 K 共享融合 shader。
//
// 模板 CPU 求值路径不实例化（has_reduction_v<MatmulRef>=true 把 dsl::compute
// 分流到引擎 eval_expr，由引擎做 matmul 预计算 + 逐元素链），eval 仅满足
// nn::Expression 概念约束，返回占位值。
// ══════════════════════════════════════════════════════════════════════════
struct MatmulRef
{
    Tensor a, b;
    bool transA = false;
    bool transB = false;
    std::uint32_t batch = 1;  // 批量数（形状参数，不进 key）
    // GQA 头分组比（docs/internal/22 §3.2 P2）：>1 时该操作数只存
    // batch/ratio 份行块（多个 query 头共享一个 KV 头）。1 = 恒等。
    std::uint32_t a_kv_ratio = 1;
    std::uint32_t b_kv_ratio = 1;

    // ── CPU 模板求值路径的预绑定状态（引擎内部，Layer 无感知）───────────
    // C 由引擎通用 matmul 原语物化一次并绑定指针；随后尾链（如 +bias）在
    // 编译期模板路径内联求值 → 编译器融合 + 向量化，不经 ExprSpec 解释器。
    // 详见本节末尾 "CPU 预绑定" 一节的说明。GPU/scan 不使用本状态。
    mutable Tensor c_cache_{};
    mutable const Scalar* c_data_ = nullptr;

    [[nodiscard]] Result<void> prepare_cpu(ComputeEngine& eng) const
    {
        // GQA（ratio>1）：CPU 预绑定路径用通用 batched_matmul，无头映射语义
        // → 直接拒绝，让上层回退到解释器（eval_expr 的 MatmulSpec 分支已支持
        // 头映射）。预绑定只是优化，回退不引入正确性风险。
        if (a_kv_ratio > 1 || b_kv_ratio > 1)
            NN_FAIL("dsl matmul prepare: kv_ratio > 1 走解释器路径（CPU 预绑定不支持头映射）");
        if (c_data_ != nullptr) return {};  // 幂等：同一棵树重复求值只物化一次
        // ── 精度安全（§7.2 f32 参考）────────────────────────────────────
        // C 固定以 P=F32 物化，而操作数可能带 **f16 存储**（profile_f16 的
        // Linear 权重/激活）：内层 GEMM 的 f32 路径按 f32 存储直接读
        // （cpu_matrix<F32>() 对 f16 存储返回空指针 → Release 读空 UB、
        // Debug 断言）。故先把非 f32 操作数抬到 f32 再物化，C 按 f32 绑定。
        const Tensor* pa = &a;
        const Tensor* pb = &b;
        Tensor ca, cb;
        if (a.precision() != Precision::F32)
        {
            auto r = eng.cast(a, Precision::F32);
            NN_TRY_CHECK(r);
            ca = std::move(*r);
            pa = &ca;
        }
        if (b.precision() != Precision::F32)
        {
            auto r = eng.cast(b, Precision::F32);
            NN_TRY_CHECK(r);
            cb = std::move(*r);
            pb = &cb;
        }
        constexpr Precision P = Precision::F32;
        Result<Tensor> c = (batch > 1)
                               ? eng.batched_matmul(*pa, *pb, batch, transA, transB, Scalar{1}, P)
                               : eng.matmul(*pa, *pb, transA, transB, P);
        NN_TRY_CHECK(c);
        if (!c->is_cpu()) NN_FAIL("dsl matmul prepare: result not on CPU");
        if (c->precision() != Precision::F32) NN_FAIL("dsl matmul prepare: result not f32");
        if (env_flag("NN_F16_DEBUG"))
        {
            const auto sp = TensorAccess::cpu_matrix(*c).span();
            double mx = 0.0;
            bool bad = false;
            for (auto v : sp)
            {
                if (!std::isfinite(v)) bad = true;
                else mx = std::max(mx, std::fabs(static_cast<double>(v)));
            }
            if (bad || mx > 10.0)
                std::fprintf(stderr,
                             "[dbg][prepare] C=(%zux%zu) A=(%zux%zu)%s B=(%zux%zu)%s "
                             "max(C)=%.6g%s <<< 异常\n",
                             c->rows(), c->cols(), pa->rows(), pa->cols(),
                             pa->precision() == Precision::F16 ? "f16" : "f32", pb->rows(),
                             pb->cols(), pb->precision() == Precision::F16 ? "f16" : "f32", mx,
                             bad ? " NONFINITE" : "");
        }
        c_cache_ = std::move(*c);
        c_data_ = TensorAccess::cpu_matrix(c_cache_).span().data();
        return {};
    }

    [[nodiscard]] constexpr Scalar eval(std::size_t) const noexcept { return Scalar{0}; }
    // CPU 模板路径（2 参）：读预绑定的 C（形状与输出网格一致）
    [[nodiscard]] Scalar eval(std::size_t i, std::size_t) const noexcept
    { return c_data_ != nullptr ? c_data_[i] : Scalar{0}; }
    ExprOperand to_spec(SpecBuilder& sb) const
    {
        // 显式固定登记顺序（A 先 B 后），保证跨编译器确定（同 Binary 约定）。
        // 下标取 add_input_linear 的**返回值**（不能用 inputs.size() 预判）。
        // A/B **不去重**（dedup=false）：matmul 的 vec4 快路径以 a_slot!=b_slot
        // 为启用条件（见 expr_glsl_gen vec4_ok）——若 A、B 是同一张量（如
        // Muon 的 X·Xᵀ）被合并成单槽，快路径整体关闭、标量回退，得不偿失。
        // 两槽绑同一张量语义等价（a/b 索引公式各按 transA/transB 独立计算）。
        const std::uint8_t ai = sb.add_input_linear(a, /*dedup=*/false).idx;
        const std::uint8_t bi = sb.add_input_linear(b, /*dedup=*/false).idx;
        // k = 求和维度：transA=0 → A.cols()（A 存储 (batch*M, K)）；
        // transA=1 → A.rows()/batch（A 存储 (batch*K, M)，每批 (K, M)）
        const std::uint32_t k = static_cast<std::uint32_t>(
            transA ? (a.rows() / (batch / (a_kv_ratio ? a_kv_ratio : 1))) : a.cols());
        sb.spec.matmul = MatmulSpec{ai,
                                    bi,
                                    transA ? std::uint8_t{1} : std::uint8_t{0},
                                    transB ? std::uint8_t{1} : std::uint8_t{0},
                                    k,
                                    batch};
        // GQA（ratio>1）：把该操作数的**视图**标成 HeadGroup 并记下头分组比
        //   —— param 是运行期形状数据（不进 key），任意 n_rep 共用一份 shader。
        if (a_kv_ratio > 1)
        {
            sb.spec.views[ai].kind = static_cast<std::uint8_t>(ExprViewKind::HeadGroup);
            sb.spec.views[ai].param = a_kv_ratio;
        }
        if (b_kv_ratio > 1)
        {
            sb.spec.views[bi].kind = static_cast<std::uint8_t>(ExprViewKind::HeadGroup);
            sb.spec.views[bi].param = b_kv_ratio;
        }
        return expr::matmul_op();
    }
};

// ══════════════════════════════════════════════════════════════════════════
// 网格索引叶子：行号/列号/批次下标作为标量参与算术
//
//   row()   = 当前输出元素在 batch 内的行号
//   col()   = 当前输出列号
//   batch() = 当前批次下标
// 用于位置相关掩码/偏置（causal select(Col > Row, -inf, 0)、ALiBi 等）。
// 走引擎 eval_expr（索引由引擎按网格推导），eval 仅满足概念约束。
// ══════════════════════════════════════════════════════════════════════════
struct RowIdxLeaf
{
    [[nodiscard]] constexpr Scalar eval(std::size_t) const noexcept { return Scalar{0}; }
    ExprOperand to_spec(SpecBuilder&) const { return expr::row(); }
};
struct ColIdxLeaf
{
    [[nodiscard]] constexpr Scalar eval(std::size_t) const noexcept { return Scalar{0}; }
    ExprOperand to_spec(SpecBuilder&) const { return expr::col(); }
};
struct BatchIdxLeaf
{
    [[nodiscard]] constexpr Scalar eval(std::size_t) const noexcept { return Scalar{0}; }
    ExprOperand to_spec(SpecBuilder&) const { return expr::batch(); }
};

// ══════════════════════════════════════════════════════════════════════════
// 视图叶子：标签行收集 / 按批次索引
//   row_gather(logits, labels)：读取 logits[label[c]][c]（稀疏 CE loss 收集）；
//     labels 登记为 ColBroadcast 视图（(1,cols)），RowGather 视图的 param
//     指向 labels 输入槽。
//   batch_mod(t, modulo)：读取 t[batch % modulo]（ALiBi 按头斜率等）。
// ══════════════════════════════════════════════════════════════════════════
struct RowGatherRef
{
    Tensor t;      // 主输入（rows, cols），如 logits (classes, total)
    Tensor labels; // 标签 (1, cols) 浮点打包

    [[nodiscard]] constexpr Scalar eval(std::size_t) const noexcept { return Scalar{0}; }
    ExprOperand to_spec(SpecBuilder& sb) const
    {
        // 登记后要改写视图为 RowGather → 必须独占新槽（dedup=false）：
        // 若复用已有 Linear 槽再覆写 views[i]，会污染原输入的视图。
        const ExprOperand ti = sb.add_input_linear(t, /*dedup=*/false);
        const std::uint8_t li = sb.add_input_colbroadcast(labels).idx;
        sb.spec.views[ti.idx] = expr::row_gather(li);  // RowGather 视图，param=标签槽
        return ti;
    }
};

struct BatchModRef
{
    Tensor t;
    std::uint32_t modulo = 1;   // 运行时视图参数（不进 key）；默认值供符号实例

    [[nodiscard]] constexpr Scalar eval(std::size_t) const noexcept { return Scalar{0}; }
    ExprOperand to_spec(SpecBuilder& sb) const
    {
        // 登记 BatchMod 视图（输入 (1,mod) 小向量，按 batch 取模索引）
        return sb.add_input(t, expr::batch_mod(modulo));
    }
};

// 按 (batch, col) 切片：doc_ids (1, batch*seq) → data[batch*seq + col]
struct BatchColRef
{
    Tensor t;
    std::uint32_t per_batch_cols = 1;   // 运行时视图参数（不进 key）；默认值供符号实例

    [[nodiscard]] constexpr Scalar eval(std::size_t) const noexcept { return Scalar{0}; }
    ExprOperand to_spec(SpecBuilder& sb) const
    { return sb.add_input(t, expr::batch_col(per_batch_cols)); }
};

// 广播视图叶子：输入 (rows,1)/(1,cols) 小向量，按行/列广播参与算术。
//
// 两者都是**纯索引映射**（不物化、无跨元素依赖），因此留在模板求值路径，
// 不经引擎解释器（见 has_reduction_v<BroadcastRef> = false）：
//   - 列广播：输入 (1,cols)，输出列数 = 输入列数 → 1 参 eval(i) 即可正确求值。
//   - 行广播：输入 (rows,1)，读第 i/cols 个标量 —— 需要"输出列数"，输入自身
//     推不出，故 1 参 eval(i)（无 cols）无法给出正确值，返回占位值；行广播
//     一律经 2 参 eval(i, cols)（eval_with_cols 自动选择）求值。
template <ExprViewKind Kind> struct BroadcastRef : CpuViewCache
{
    Tensor t;

    BroadcastRef(Tensor tt) : t(std::move(tt)) { cache_cpu_view(t); }
    // 符号实例（AOT 自登记）：结构由类型（Kind）与默认张量决定
    BroadcastRef() = default;

    [[nodiscard]] Scalar eval(std::size_t i) const
    {
        if constexpr (Kind == ExprViewKind::ColBroadcast)
            return at(i % cols);   // 输入 (1,cols) → cols 即输出列数
        else return Scalar{0};  // 行广播需输出列数，见 eval(i, out_cols)
    }
    [[nodiscard]] Scalar eval(std::size_t i, std::size_t out_cols) const
    {
        if constexpr (Kind == ExprViewKind::ColBroadcast) return at(i % cols);
        else return at(i / out_cols);  // 输入 (rows,1)：读第 r 个标量
    }
    ExprOperand to_spec(SpecBuilder& b) const
    {
        if constexpr (Kind == ExprViewKind::RowBroadcast) return b.add_input_rowbroadcast(t);
        else return b.add_input_colbroadcast(t);
    }
};

using RowBroadcastRef = BroadcastRef<ExprViewKind::RowBroadcast>;
using ColBroadcastRef = BroadcastRef<ExprViewKind::ColBroadcast>;

// ══════════════════════════════════════════════════════════════════════════
// DSL 表达式概念（比 nn::Expression 更严格：额外要求可折叠成 ExprSpec）
//
// 用于让 DSL 运算符以更严的约束参与重载解析，从而在 namespace nn（Layer）
// 里**直接写内联数学表达式**时重载唯一确定：只有可折叠节点（带 to_spec）
// 参与 + - * / 与比较，非折叠的 nn::Expression（Span/ConstSpan 等）不成为
// 候选，误用在编译期即暴露。
// ══════════════════════════════════════════════════════════════════════════
template <typename T>
concept DslExpr = nn::Expression<T> && requires (SpecBuilder& b, const T& t) {
    { t.to_spec(b) } -> std::convertible_to<ExprOperand>;
};

// ══════════════════════════════════════════════════════════════════════════
// 节点模板（每个都同时支持 CPU 求值 eval(i) 与 GPU 折叠 to_spec）
// ══════════════════════════════════════════════════════════════════════════

template <typename Op, nn::Expression C> struct Unary
{
    C child;
    [[nodiscard]] auto eval(std::size_t i) const { return Op::apply(child.eval(i)); }
    [[nodiscard]] auto eval(std::size_t i, std::size_t cols) const
    { return Op::apply(eval_with_cols(child, i, cols)); }
    ExprOperand to_spec(SpecBuilder& b) const { return b.add_instr(Op::op_id(), child.to_spec(b)); }
};

// 比较算子（ops::Gt 等）使 eval 返回 bool → 该 Binary 是 BoolExpression，
// 供 select() 使用；to_spec 仍折叠成单条比较指令（输出 0.0/1.0 到寄存器）。
template <typename Op, nn::Expression L, nn::Expression R> struct Binary
{
    L l;
    R r;
    [[nodiscard]] auto eval(std::size_t i) const { return Op::apply(l.eval(i), r.eval(i)); }
    [[nodiscard]] auto eval(std::size_t i, std::size_t cols) const
    { return Op::apply(eval_with_cols(l, i, cols), eval_with_cols(r, i, cols)); }
    ExprOperand to_spec(SpecBuilder& b) const
    {
        // 显式固定操作数折叠顺序（l 先 r 后）：C++ 函数实参求值顺序未指定，
        // 直接 b.add_instr(.., l.to_spec(b), r.to_spec(b)) 会让 views/inputs 的
        // 登记顺序随编译器（MSVC 左到右 / Clang 右到左）漂移 → expr_spec_key
        // 跨编译器不稳定，破坏 AOT 匹配。先求值到局部变量以固定顺序。
        const ExprOperand lo = l.to_spec(b);
        const ExprOperand ro = r.to_spec(b);
        return b.add_instr(Op::op_id(), lo, ro);
    }
};

// select(cond, then, else) —— cond 为 BoolExpression，then/else 为值表达式
template <nn::BoolExpression C, nn::Expression T, nn::Expression E> struct Select
{
    C cond;
    T then_e;
    E else_e;
    [[nodiscard]] Scalar eval(std::size_t i) const
    { return cond.eval(i) ? then_e.eval(i) : else_e.eval(i); }
    [[nodiscard]] Scalar eval(std::size_t i, std::size_t cols) const
    {
        return (eval_with_cols(cond, i, cols) != Scalar{0}) ? eval_with_cols(then_e, i, cols)
                                                            : eval_with_cols(else_e, i, cols);
    }
    ExprOperand to_spec(SpecBuilder& b) const
    {
        // 同 Binary：显式固定折叠顺序（cond → then → else），保证跨编译器确定。
        const ExprOperand co = cond.to_spec(b);
        const ExprOperand to = then_e.to_spec(b);
        const ExprOperand eo = else_e.to_spec(b);
        return b.add_instr(ExprOp::Select, co, to, eo);
    }
};

// 归约节点：对子表达式结果做归约（归约**指令**）→ 隐式标量向量（Reduce 操作数）。
//   row_reduce_sum(exp(x)) 这类"表达式内部归约"；对输入 Tensor 直接归约请用
//   ReduceViewRef（归约视图，GPU 融合更友好）。
template <nn::dsl::DslExpr E, ExprOp Rop> struct ReduceRef
{
    // 归约轴与算子：行归约 → 向量长度 rows；列归约 → 长度 cols
    static constexpr bool reduces_rows = (Rop == ExprOp::RowSum || Rop == ExprOp::RowMax);
    static constexpr bool reduces_max = (Rop == ExprOp::RowMax || Rop == ExprOp::ColMax);

    E child;

    // ── CPU 模板路径预绑定（引擎内部，Layer 无感知）─────────────────────
    // 两阶段：先递归备好子表达式（其内部若还有归约节点也一并备好），再按输出槽
    // 对子表达式求值并归约到 vec_。槽内沿归约轴升序累加 → 与解释器
    // replay_prefix 的累加顺序逐字节一致（铁律 8）。
    mutable std::vector<Scalar> vec_{};
    mutable const Scalar* v_ = nullptr;

    [[nodiscard]] constexpr Scalar eval(std::size_t) const noexcept { return Scalar{0}; }
    // CPU 模板路径（2 参）：归约指令按行/列广播
    [[nodiscard]] Scalar eval(std::size_t i, std::size_t cols) const noexcept
    {
        if (v_ == nullptr) return Scalar{0};
        return reduces_rows ? v_[i / cols] : v_[i % cols];
    }
    ExprOperand to_spec(SpecBuilder& b) const { return b.add_reduce_instr(Rop, child.to_spec(b)); }
};

// ══════════════════════════════════════════════════════════════════════════
// has_reduction_v：表达式树是否**必须**走引擎解释器
//
// 用于 dsl::compute 的 CPU 路径分流：需要"全行/全列"信息、或需要引擎按网格
// 推导的表达式（归约视图/归约指令/matmul/网格索引/标签收集）无法用逐元素
// 模板求值表达 → 折叠成 ExprSpec 走引擎 eval_expr（CPU 扩展语义处理）；
// 其余表达式（含广播视图这类纯索引映射）保持编译期模板求值（内联 + 并行）。
// 该标志只影响 CPU 分支；GPU/scan 一律走 to_expr_spec，与本标志无关。
// ══════════════════════════════════════════════════════════════════════════
template <typename T> inline constexpr bool has_reduction_v = false;

// 归约叶子需走 eval_expr（模板求值无法表达全行/全列归约）
template <ExprViewKind K> inline constexpr bool has_reduction_v<ReduceViewRef<K>> = true;
// 广播视图**不需要**走 eval_expr：它是纯索引映射（无跨元素依赖），2 参
// eval(i, cols) 即可在模板求值路径上正确求值（见 BroadcastRef 与
// eval_with_cols）→ 留在编译期模板路径（内联 + 并行）。
template <ExprViewKind K> inline constexpr bool has_reduction_v<BroadcastRef<K>> = false;
// 分组归约视图：每输出元素独立归约 R 行、元素间零依赖 → 非归约（留
// 编译期模板路径；fail-safe 显式声明，防默认值漂移把它推进解释器）
template <> inline constexpr bool has_reduction_v<GroupedReduceSumRef> = false;
template <> inline constexpr bool has_reduction_v<GroupedReduceMaxRef> = false;
// matmul 叶子同样需走 eval_expr（matmul 预计算 + 逐元素链，引擎实现）
template <> inline constexpr bool has_reduction_v<MatmulRef> = true;
// 索引/收集叶子：行/列/批次下标与标签收集由引擎按网格推导
template <> inline constexpr bool has_reduction_v<RowIdxLeaf> = true;
template <> inline constexpr bool has_reduction_v<ColIdxLeaf> = true;
template <> inline constexpr bool has_reduction_v<BatchIdxLeaf> = true;
template <> inline constexpr bool has_reduction_v<RowGatherRef> = true;
template <> inline constexpr bool has_reduction_v<BatchModRef> = true;
template <> inline constexpr bool has_reduction_v<BatchColRef> = true;
template <nn::dsl::DslExpr E, ExprOp Rop>
inline constexpr bool has_reduction_v<ReduceRef<E, Rop>> = true;
template <typename Op, nn::Expression C>
inline constexpr bool has_reduction_v<Unary<Op, C>> = has_reduction_v<C>;
template <typename Op, nn::Expression L, nn::Expression R>
inline constexpr bool has_reduction_v<Binary<Op, L, R>> = has_reduction_v<L> || has_reduction_v<R>;
template <nn::BoolExpression C, nn::Expression T, nn::Expression E>
inline constexpr bool has_reduction_v<Select<C, T, E>> =
    has_reduction_v<C> || has_reduction_v<T> || has_reduction_v<E>;

// ══════════════════════════════════════════════════════════════════════════
// 叶子构造（普通写法入口）
// ══════════════════════════════════════════════════════════════════════════
[[nodiscard]] inline TensorRef leaf(Tensor t)
{ return TensorRef{std::move(t)}; }

// 运行时标量参数（RParam）：值不限、结构固定 → 同结构共享融合 shader。
// 用于优化器超参（lr/eps/β）、偏差修正系数等每步会变但结构不变的标量。
[[nodiscard]] inline constexpr RParamLeaf rparam(Scalar v)
{ return RParamLeaf{v}; }

// matmul 叶子：C = op(A,B)，折叠为 ExprSpec 的前置 matmul 段。
// 逐元素链（如 +bias、激活）自动与 matmul 融合成一个 kernel（GPU AOT）。
// batch：A/B 按 batch 垂直切分（batched_matmul 同布局），形状参数。
[[nodiscard]] inline MatmulRef matmul(Tensor a, Tensor b, bool transA = false, bool transB = false,
                                      std::uint32_t batch = 1)
{ return MatmulRef{std::move(a), std::move(b), transA, transB, batch}; }

// GQA 变体：a_kv_ratio / b_kv_ratio > 1 时该操作数只存 batch/ratio 份行块
// （多个连续 query 头共享一个 KV 头；块映射见 docs/internal/22 §3.2）。
[[nodiscard]] inline MatmulRef matmul_kv(Tensor a, Tensor b, bool transA, bool transB,
                                         std::uint32_t batch, std::uint32_t a_kv_ratio,
                                         std::uint32_t b_kv_ratio)
{
    MatmulRef m{std::move(a), std::move(b), transA, transB, batch};
    m.a_kv_ratio = a_kv_ratio;
    m.b_kv_ratio = b_kv_ratio;
    return m;
}

// 网格索引叶子：行号/列号/批次下标
[[nodiscard]] inline RowIdxLeaf row()
{ return {}; }
[[nodiscard]] inline ColIdxLeaf col()
{ return {}; }
[[nodiscard]] inline BatchIdxLeaf batch()
{ return {}; }

// 视图叶子：标签行收集（稀疏 CE loss）/ 按批次取模索引（ALiBi 斜率）/
// 按 (batch,col) 切片（doc_ids）
[[nodiscard]] inline RowGatherRef row_gather(Tensor t, Tensor labels)
{ return RowGatherRef{std::move(t), std::move(labels)}; }
[[nodiscard]] inline BatchModRef batch_mod(Tensor t, std::uint32_t modulo)
{ return BatchModRef{std::move(t), modulo}; }
[[nodiscard]] inline BatchColRef batch_col(Tensor t, std::uint32_t per_batch_cols)
{ return BatchColRef{std::move(t), per_batch_cols}; }

[[nodiscard]] inline RotateHalfRef rotate_half(Tensor t, std::uint32_t block)
{ return RotateHalfRef{std::move(t), block}; }

[[nodiscard]] inline RowModRef row_mod(Tensor t, std::uint32_t mod)
{ return RowModRef{std::move(t), mod}; }

// 行偏移+取模访问（SwiGLU 半切分等）：data[(offset + r % mod)*cols + c]
[[nodiscard]] inline RowAccessRef row_access(Tensor t, std::uint32_t offset, std::uint32_t mod)
{ return RowAccessRef{std::move(t), offset, mod}; }

// 分组归约（MaxPool 窗口归约等）：输入 (G*R, N) → 输出 (G, N)
[[nodiscard]] inline GroupedReduceSumRef grouped_reduce_sum(Tensor t, std::uint32_t R)
{ return GroupedReduceSumRef{std::move(t), R}; }
[[nodiscard]] inline GroupedReduceMaxRef grouped_reduce_max(Tensor t, std::uint32_t R)
{ return GroupedReduceMaxRef{std::move(t), R}; }

// ══════════════════════════════════════════════════════════════════════════
// 归约自由函数：对输入 Tensor 直接归约 → 归约**视图**（GPU 融合更友好）；
// 对表达式结果归约 → 归约**指令**（重载按参数类型自动选择，见 ReduceRef）。
// 返回的归约叶子参与算术时自动按行/按列广播。
// ══════════════════════════════════════════════════════════════════════════
[[nodiscard]] inline RowReduceSumRef row_reduce_sum(Tensor t)
{ return {std::move(t)}; }
[[nodiscard]] inline RowReduceMaxRef row_reduce_max(Tensor t)
{ return {std::move(t)}; }
[[nodiscard]] inline ColReduceSumRef col_reduce_sum(Tensor t)
{ return {std::move(t)}; }
[[nodiscard]] inline ColReduceMaxRef col_reduce_max(Tensor t)
{ return {std::move(t)}; }

template <nn::dsl::DslExpr E> [[nodiscard]] auto row_reduce_sum(const E& e)
{ return ReduceRef<E, ExprOp::RowSum>{e}; }
template <nn::dsl::DslExpr E> [[nodiscard]] auto row_reduce_max(const E& e)
{ return ReduceRef<E, ExprOp::RowMax>{e}; }
template <nn::dsl::DslExpr E> [[nodiscard]] auto col_reduce_sum(const E& e)
{ return ReduceRef<E, ExprOp::ColSum>{e}; }
template <nn::dsl::DslExpr E> [[nodiscard]] auto col_reduce_max(const E& e)
{ return ReduceRef<E, ExprOp::ColMax>{e}; }

// 广播视图自由函数：gamma/beta (F,1) 按行广播、std_inv (1,B) 按列广播
[[nodiscard]] inline RowBroadcastRef row_broadcast(Tensor t)
{ return {std::move(t)}; }
[[nodiscard]] inline ColBroadcastRef col_broadcast(Tensor t)
{ return {std::move(t)}; }

// ══════════════════════════════════════════════════════════════════════════
// 一元函数（普通数学写法）
// ══════════════════════════════════════════════════════════════════════════
template <nn::dsl::DslExpr E> [[nodiscard]] constexpr auto neg(const E& e)
{ return Unary<ops::Neg, E>{e}; }
template <nn::dsl::DslExpr E> [[nodiscard]] auto abs(const E& e)
{ return Unary<ops::Abs, E>{e}; }
template <nn::dsl::DslExpr E> [[nodiscard]] auto exp(const E& e)
{ return Unary<ops::Exp, E>{e}; }
template <nn::dsl::DslExpr E> [[nodiscard]] auto log(const E& e)
{ return Unary<ops::Log, E>{e}; }
template <nn::dsl::DslExpr E> [[nodiscard]] auto sqrt(const E& e)
{ return Unary<ops::Sqrt, E>{e}; }
template <nn::dsl::DslExpr E> [[nodiscard]] auto rsqrt(const E& e)
{ return Unary<ops::Rsqrt, E>{e}; }
template <nn::dsl::DslExpr E> [[nodiscard]] auto tanh(const E& e)
{ return Unary<ops::Tanh, E>{e}; }

// ══════════════════════════════════════════════════════════════════════════
// 二元函数：max / min / select
// ══════════════════════════════════════════════════════════════════════════
template <nn::dsl::DslExpr L, nn::dsl::DslExpr R>
[[nodiscard]] constexpr auto max(const L& l, const R& r)
{ return Binary<ops::Max, L, R>{l, r}; }
template <nn::dsl::DslExpr E> [[nodiscard]] constexpr auto max(const E& e, Scalar s)
{
    return Binary<ops::Max, E, ConstLeaf>{e, ConstLeaf{s}};
}
template <nn::dsl::DslExpr E> [[nodiscard]] constexpr auto max(Scalar s, const E& e)
{ return Binary<ops::Max, ConstLeaf, E>{ConstLeaf{s}, e}; }
template <nn::dsl::DslExpr L, nn::dsl::DslExpr R>
[[nodiscard]] constexpr auto min(const L& l, const R& r)
{ return Binary<ops::Min, L, R>{l, r}; }
template <nn::dsl::DslExpr E> [[nodiscard]] constexpr auto min(const E& e, Scalar s)
{
    return Binary<ops::Min, E, ConstLeaf>{e, ConstLeaf{s}};
}
template <nn::dsl::DslExpr E> [[nodiscard]] constexpr auto min(Scalar s, const E& e)
{ return Binary<ops::Min, ConstLeaf, E>{ConstLeaf{s}, e}; }

/// relu(x) = max(x, 0)
template <nn::dsl::DslExpr E> [[nodiscard]] auto relu(const E& e)
{ return nn::dsl::max(e, ConstLeaf{Scalar{0}}); }

template <nn::BoolExpression C, nn::dsl::DslExpr T, nn::dsl::DslExpr E>
[[nodiscard]] constexpr auto select(const C& c, const T& t, const E& e)
{ return Select<C, T, E>{c, t, e}; }
template <nn::BoolExpression C, nn::dsl::DslExpr T>
[[nodiscard]] constexpr auto select(const C& c, const T& t, Scalar ev)
{
    return Select<C, T, ConstLeaf>{c, t, ConstLeaf{ev}};
}
template <nn::BoolExpression C, nn::dsl::DslExpr E>
[[nodiscard]] constexpr auto select(const C& c, Scalar tv, const E& e)
{ return Select<C, ConstLeaf, E>{c, ConstLeaf{tv}, e}; }
template <nn::BoolExpression C>
[[nodiscard]] constexpr auto select(const C& c, Scalar tv, Scalar ev)
{
    return Select<C, ConstLeaf, ConstLeaf>{c, ConstLeaf{tv}, ConstLeaf{ev}};
}

// ══════════════════════════════════════════════════════════════════════════
// 运算符（Sym 生成，覆盖 Expr×Expr / Expr×Scalar / Scalar×Expr）
// 值运算（+ - * /）返回值表达式；比较（> < >= <= == !=）返回布尔表达式。
// ══════════════════════════════════════════════════════════════════════════
#define NN_DSL_BINARY(OP, OpT)                                                                   \
    template <nn::dsl::DslExpr L, nn::dsl::DslExpr R>                                            \
    [[nodiscard]] constexpr auto operator OP(const L& l, const R& r)                             \
    { return Binary<OpT, L, R>{l, r}; }                                                          \
    template <nn::dsl::DslExpr E> [[nodiscard]] constexpr auto operator OP(const E& e, Scalar s) \
    {                                                                                            \
        return Binary<OpT, E, ConstLeaf>{e, ConstLeaf{s}};                                       \
    }                                                                                            \
    template <nn::dsl::DslExpr E> [[nodiscard]] constexpr auto operator OP(Scalar s, const E& e) \
    { return Binary<OpT, ConstLeaf, E>{ConstLeaf{s}, e}; }

NN_DSL_BINARY(+, ops::Add)
NN_DSL_BINARY(-, ops::Sub)
NN_DSL_BINARY(*, ops::Mul)
NN_DSL_BINARY(/, ops::Div)
NN_DSL_BINARY(>, ops::Gt)
NN_DSL_BINARY(<, ops::Lt)
NN_DSL_BINARY(>=, ops::Ge)
NN_DSL_BINARY(<=, ops::Le)
NN_DSL_BINARY(==, ops::Eq)
NN_DSL_BINARY(!=, ops::Ne)
#undef NN_DSL_BINARY

template <nn::dsl::DslExpr E> [[nodiscard]] constexpr auto operator-(const E& e)
{ return Unary<ops::Neg, E>{e}; }

// ══════════════════════════════════════════════════════════════════════════
// GPU AOT：编译期表达式 → 扁平 ExprSpec + 输入张量（AOT 注册表分发用）
// ══════════════════════════════════════════════════════════════════════════
template <typename E>
[[nodiscard]] std::pair<ExprSpec, std::vector<Tensor>> to_expr_spec(const E& e)
{
    SpecBuilder b;
    (void)e.to_spec(b);
    return {std::move(b.spec), std::move(b.inputs)};
}

// ══════════════════════════════════════════════════════════════════════════
// 输出网格形状推导（供 dsl::compute / compute_reduce 的**无形状重载**）
//
// 背景：`dsl::compute(engine, expr, rows, cols[, P])` 必带输出形状——调用方
// 反复手写 `x.rows(), x.cols()`（docs/internal/18-roadmap.md P4-4 记为 API 摩擦点）。
// `dsl::compute(engine, expr[, P])` 用**唯一口径**从表达式推导该形状：
//
//   输出网格 = 各"网格贡献者"的**广播合并**（逐维：相等，或其一为 1）。
//   · 张量叶 / 形状保持视图（TensorRef / RotateHalf / RowMod / RowAccess /
//     Broadcast）：贡献其张量形状（行广播 (F,1) / 列广播 (1,C) 由此天然合并）。
//   · 归约视图（ReduceViewRef / ReduceRef）：在 compute 的输出网格里是
//     "按行/列读"的**广播读**，故贡献**输入张量**的整网格（compute 的输出
//     仍是整网格，不是归约向量——归约向量用 compute_reduce）。
//   · GroupedReduce(g, R)：贡献 (rows/R, cols)（沿行分组、列不变）。
//   · matmul 段：贡献 (batch·M, N)（与后端 batched_matmul 同一口径；GQA 的
//     batch/ratio 行块亦按 to_spec 的 k 同一推导）。A/B **不**参与合并——
//     它们是 GEMM 操作数，不是同网格项。
//   · 标量（Const/RParam）、网格索引叶（row/col/batch）、稀疏与批视图
//     （RowGather/BatchMod/BatchCol）：中性（不贡献）。
//   · Unary/Binary/Select：递进子节点合并。
//
// 合并冲突（某维既非相等、又都不为 1）、形状不可推导、或**完全没有贡献者**
// → 报错并提示显式给出 rows/cols。**绝不猜形状**（静默错值远比报错昂贵）。
// ══════════════════════════════════════════════════════════════════════════
struct GridInfer
{
    std::size_t rows = 0;
    std::size_t cols = 0;
    bool any = false;        // 是否合并过至少一个贡献者
    bool conflict = false;   // 广播规则不成立（某维既不等、又都不为 1）
    bool unknown = false;    // 有贡献者存在但形状推不出来（如行块不整除）

    [[nodiscard]] static std::size_t merge_dim(std::size_t a, std::size_t b, bool& conflict)
    {
        if (a == b) return a;
        if (a == 1) return b;
        if (b == 1) return a;
        conflict = true;
        return a;
    }
    void merge(std::size_t r, std::size_t c)
    {
        if (conflict || unknown) return;
        if (!any)
        {
            rows = r;
            cols = c;
            any = true;
            return;
        }
        rows = merge_dim(rows, r, conflict);
        cols = merge_dim(cols, c, conflict);
    }
};

// 缺省：不贡献（标量叶 / 网格索引叶 / 稀疏与批视图）
template <typename E> inline void grid_contrib(const E&, GridInfer&) {}

// 形状保持的叶子/视图
inline void grid_contrib(const TensorRef& e, GridInfer& g)
{
    if (e.t.valid()) g.merge(e.t.rows(), e.t.cols());
    else g.unknown = true;
}
inline void grid_contrib(const RotateHalfRef& e, GridInfer& g)
{
    if (e.t.valid()) g.merge(e.t.rows(), e.t.cols());
    else g.unknown = true;
}
inline void grid_contrib(const RowModRef& e, GridInfer& g)
{
    if (e.t.valid()) g.merge(e.t.rows(), e.t.cols());
    else g.unknown = true;
}
inline void grid_contrib(const RowAccessRef& e, GridInfer& g)
{
    if (e.t.valid()) g.merge(e.t.rows(), e.t.cols());
    else g.unknown = true;
}
template <ExprViewKind Kind> inline void grid_contrib(const BroadcastRef<Kind>& e, GridInfer& g)
{
    if (e.t.valid()) g.merge(e.t.rows(), e.t.cols());
    else g.unknown = true;
}
// 归约视图：compute 下是广播读 → 贡献输入整网格（compute_reduce 要的也是
// 输入网格，两者同口径）
template <ExprViewKind Kind> inline void grid_contrib(const ReduceViewRef<Kind>& e, GridInfer& g)
{
    if (e.t.valid()) g.merge(e.t.rows(), e.t.cols());
    else g.unknown = true;
}

// 分组归约：输出 (rows/R, cols)
template <bool IsMax> inline void grid_contrib(const GroupedReduceRef<IsMax>& e, GridInfer& g)
{
    if (!e.t.valid() || e.r_len == 0 || e.t.rows() % e.r_len != 0)
    {
        g.unknown = true;
        return;
    }
    g.merge(e.t.rows() / e.r_len, e.t.cols());
}

// matmul 段：输出 (batch·M, N)（与 compute_engine.hpp 的 batched_matmul 口径一致）
inline void grid_contrib(const MatmulRef& e, GridInfer& g)
{
    const std::size_t batch = e.batch;
    const std::size_t ra = e.a_kv_ratio ? e.a_kv_ratio : 1;
    const std::size_t rb = e.b_kv_ratio ? e.b_kv_ratio : 1;
    if (batch == 0 || !e.a.valid() || !e.b.valid() || batch % ra != 0 || batch % rb != 0)
    {
        g.unknown = true;
        return;
    }
    const std::size_t a_blocks = batch / ra;   // GQA：该操作数只存 batch/ratio 份行块
    const std::size_t b_blocks = batch / rb;
    if (e.a.rows() % a_blocks != 0 || e.b.rows() % b_blocks != 0)
    {
        g.unknown = true;
        return;
    }
    const std::size_t a_rows_per = e.a.rows() / a_blocks;
    const std::size_t b_rows_per = e.b.rows() / b_blocks;
    const std::size_t M = e.transA ? e.a.cols() : a_rows_per;
    const std::size_t N = e.transB ? b_rows_per : e.b.cols();
    if (M == 0 || N == 0)
    {
        g.unknown = true;
        return;
    }
    g.merge(batch * M, N);
}

// 复合节点：递进子节点合并
template <typename E, ExprOp Rop> inline void grid_contrib(const ReduceRef<E, Rop>& e, GridInfer& g)
{ grid_contrib(e.child, g); }
template <typename Op, nn::Expression C>
inline void grid_contrib(const Unary<Op, C>& e, GridInfer& g)
{ grid_contrib(e.child, g); }
template <typename Op, nn::Expression L, nn::Expression R>
inline void grid_contrib(const Binary<Op, L, R>& e, GridInfer& g)
{
    grid_contrib(e.l, g);
    grid_contrib(e.r, g);
}
template <nn::BoolExpression C, nn::Expression T, nn::Expression Ex>
inline void grid_contrib(const Select<C, T, Ex>& e, GridInfer& g)
{
    grid_contrib(e.cond, g);
    grid_contrib(e.then_e, g);
    grid_contrib(e.else_e, g);
}

// 推导出口：失败一律给出"可操作"的错误（点名入口 + 提示显式 rows/cols）
template <typename E>
[[nodiscard]] inline Result<std::pair<std::size_t, std::size_t>> infer_grid_shape(const E& e,
                                                                                  const char* entry)
{
    GridInfer g;
    grid_contrib(e, g);
    const std::string where = std::string(entry) + "(engine, expr[, P])";
    if (g.conflict)
        NN_FAIL(where + " 无法推导输出形状：操作数形状不满足广播规则"
                        "（逐维相等或其一为 1）→ 请用显式形式给出 rows/cols");
    if (g.unknown)
        NN_FAIL(where + " 无法推导输出形状：表达式含形状不可推导的项"
                        "（如 GQA matmul 行块不整除）→ 请用显式形式给出 rows/cols");
    if (!g.any)
        NN_FAIL(where + " 无法推导输出形状：表达式不含可确定网格的张量操作数"
                        "（如裸广播向量）→ 请用显式形式给出 rows/cols");
    return std::pair<std::size_t, std::size_t>{g.rows, g.cols};
}

// ══════════════════════════════════════════════════════════════════════════
// CPU 预绑定（cpu_prepare）—— 让"含 matmul/归约"的表达式也走编译期内联
//
// 背景：has_reduction_v 仅用于 CPU 分支分流（GPU/scan 一律 to_expr_spec）。
// matmul / 归约视图 / 归约指令 / 网格索引这类"需要 GEMM 或全行全列才能算出"
// 的节点无法逐元素内联——不预绑定就会把**整棵表达式**丢给运行时 ExprSpec
// 解释器（逐元素 Scalar regs[16]={} + switch(op) + lambda 间接调用）。
//
// 本节与文件头 §1 的既有设计意图一致（"CPU 直接把表达式当作编译期 AST，
// 逐元素求值 → 编译器内联 + SIMD 融合，等价手写 for 循环"）：把真正需要
// 全局信息的节点**先算出来并绑定**，其余部分仍交给 eval_into_span 内联求值。
// 即：融合交给编译器，而不是运行时解释器。
//
// 红线：本节只做"通用结构"的预绑定（matmul / 归约 / 索引映射），不含任何
// 算法名或算法逻辑；公式文本仍只在 Layer。GPU 路径完全不经过本段。
//
// ⚠ 白名单必须**fail-safe**：占位 eval() 的节点（ReduceViewRef/ReduceRef/
//   RowIdxLeaf/ColIdxLeaf/BatchIdxLeaf/RowGatherRef/BatchModRef/BatchColRef 的
//   eval 目前返回占位值，真实语义只由解释器提供）一旦被放进模板路径就会
//   **静默算错**。因此：默认只有 has_reduction_v 为假（本就是模板路径原生
//   节点）才可预绑定，含归约的节点必须逐个显式加入白名单。
// ══════════════════════════════════════════════════════════════════════════

// 含归约节点的白名单：只列已确认可"预绑定 + 模板内联"的节点（逐个确认后加入）
template <typename T> inline constexpr bool cpu_preparable_leaf_v = false;

// ── 表达式是否含"真正的行/列归约" ───────────────────────────────────────
// 与 has_reduction_v 的区别：matmul 段与网格索引**不算**——它们只是"需要预计算
// 的逐元素前缀"，输出形状仍是 (rows, cols)；而真正的归约把输出降成
// (rows,1)/(1,cols)。
// 用于维持 compute_into 的对外契约：它只接受逐元素表达式，含真归约必须报错
// （与 CpuEngine::eval_expr_into 的 expr_spec_reduce_axis != -1 守卫一致）。
template <typename T> inline constexpr bool has_real_reduction_v = false;
template <ExprViewKind K> inline constexpr bool has_real_reduction_v<ReduceViewRef<K>> = true;
template <typename C, ExprOp Rop>
inline constexpr bool has_real_reduction_v<ReduceRef<C, Rop>> = true;
template <typename Op, nn::Expression C>
inline constexpr bool has_real_reduction_v<Unary<Op, C>> = has_real_reduction_v<C>;
template <typename Op, nn::Expression L, nn::Expression R>
inline constexpr bool has_real_reduction_v<Binary<Op, L, R>> =
    has_real_reduction_v<L> || has_real_reduction_v<R>;
template <nn::BoolExpression C, nn::Expression T, nn::Expression E>
inline constexpr bool has_real_reduction_v<Select<C, T, E>> =
    has_real_reduction_v<C> || has_real_reduction_v<T> || has_real_reduction_v<E>;

// matmul：用引擎通用 GEMM 原语物化 C 后绑定指针，尾链交模板路径内联
template <> inline constexpr bool cpu_preparable_leaf_v<MatmulRef> = true;

// 归约视图：按输出槽预计算行/列归约向量后交模板路径（语义与解释器一致）
template <ExprViewKind K> inline constexpr bool cpu_preparable_leaf_v<ReduceViewRef<K>> = true;

// 归约指令：内部会先递归备好子表达式
template <typename C, ExprOp Rop>
inline constexpr bool cpu_preparable_leaf_v<ReduceRef<C, Rop>> = true;

// 树级判定：不含归约的节点本就是模板路径原生节点，可直接预绑定（no-op）；
// 含归约的节点只有白名单内的才可预绑定
template <typename T>
inline constexpr bool cpu_preparable_v = !has_reduction_v<T> || cpu_preparable_leaf_v<T>;

template <typename Op, nn::Expression C>
inline constexpr bool cpu_preparable_v<Unary<Op, C>> = cpu_preparable_v<C>;
template <typename Op, nn::Expression L, nn::Expression R>
inline constexpr bool cpu_preparable_v<Binary<Op, L, R>> =
    cpu_preparable_v<L> && cpu_preparable_v<R>;
template <nn::BoolExpression C, nn::Expression T, nn::Expression E>
inline constexpr bool cpu_preparable_v<Select<C, T, E>> =
    cpu_preparable_v<C> && cpu_preparable_v<T> && cpu_preparable_v<E>;
// 归约指令：可预绑定 ⇔ 子表达式可预绑定（其自身归约由 cpu_prepare 负责）
template <typename C, ExprOp Rop>
inline constexpr bool cpu_preparable_v<ReduceRef<C, Rop>> = cpu_preparable_v<C>;

// 默认：普通叶子 / 视图 / 索引叶子无需预绑定
template <typename T>
[[nodiscard]] inline Result<void> cpu_prepare(const T&, ComputeEngine&, std::size_t, std::size_t)
{ return {}; }

template <typename Op, nn::Expression C>
[[nodiscard]] inline Result<void> cpu_prepare(const Unary<Op, C>& u, ComputeEngine& eng,
                                              std::size_t rows, std::size_t cols)
{ return cpu_prepare(u.child, eng, rows, cols); }

template <typename Op, nn::Expression L, nn::Expression R>
[[nodiscard]] inline Result<void> cpu_prepare(const Binary<Op, L, R>& b, ComputeEngine& eng,
                                              std::size_t rows, std::size_t cols)
{
    if (auto r = cpu_prepare(b.l, eng, rows, cols); !r) return r;
    return cpu_prepare(b.r, eng, rows, cols);
}

template <nn::BoolExpression C, nn::Expression T, nn::Expression E>
[[nodiscard]] inline Result<void> cpu_prepare(const Select<C, T, E>& s, ComputeEngine& eng,
                                              std::size_t rows, std::size_t cols)
{
    if (auto r = cpu_prepare(s.cond, eng, rows, cols); !r) return r;
    if (auto r = cpu_prepare(s.then_e, eng, rows, cols); !r) return r;
    return cpu_prepare(s.else_e, eng, rows, cols);
}

// matmul：把 C 物化一次（引擎通用 GEMM 原语）并绑定指针
[[nodiscard]] inline Result<void> cpu_prepare(const MatmulRef& m, ComputeEngine& eng, std::size_t,
                                              std::size_t)
{ return m.prepare_cpu(eng); }

// 归约视图：按输出槽算出行/列归约向量（槽内沿归约轴升序累加）
template <ExprViewKind K>
[[nodiscard]] inline Result<void> cpu_prepare(const ReduceViewRef<K>& r, ComputeEngine&,
                                              std::size_t rows, std::size_t cols)
{
    if (r.v_ != nullptr) return {};
    if (!r.t.is_cpu()) NN_FAIL("dsl reduce-view prepare: input not on CPU");
    if (r.t.rows() != rows || r.t.cols() != cols)
        NN_FAIL("dsl reduce-view prepare: shape mismatch");
    using R = ReduceViewRef<K>;
    // f16 输入 → 归约在 f32 参考空间做（§7.2）：一次性镜像后读。直接
    // cpu_matrix() 读 f16 存储 = 空指针 UB（MatmulRef::prepare_cpu 同款
    // 精度-存储不匹配约束）。
    Matrix mirror;
    std::span<const Scalar> s;
    if (r.t.precision() == Precision::F32) { s = TensorAccess::cpu_matrix(r.t).span(); }
    else if (r.t.precision() == Precision::F16)
    {
        const auto s16 = TensorAccess::cpu_matrix<Precision::F16>(r.t).span();
        mirror = Matrix(r.t.rows(), r.t.cols());
        auto d = mirror.span();
        for (std::size_t i = 0; i < s16.size(); ++i)
            d[i] = static_cast<Scalar>(s16[i]);
        s = mirror.span();
    }
    else
    {
        NN_FAIL("dsl reduce-view prepare: unsupported precision");
    }
    const Scalar init = R::reduces_max ? std::numeric_limits<Scalar>::lowest() : Scalar{0};
    const std::size_t len = R::reduces_rows ? rows : cols;
    r.vec_.assign(len, init);

    const auto slot_kernel = [&](std::size_t slot) noexcept
    {
        Scalar a = init;
        if constexpr (R::reduces_rows)
            for (std::size_t c = 0; c < cols; ++c)
                a = R::reduces_max ? std::max(a, s[slot * cols + c]) : a + s[slot * cols + c];
        else
            for (std::size_t rr = 0; rr < rows; ++rr)
                a = R::reduces_max ? std::max(a, s[rr * cols + slot]) : a + s[rr * cols + slot];
        r.vec_[slot] = a;
    };
    // 槽间独立（累加方向固定）→ 并行与串行逐字节一致，无需归并
    if (rows * cols >= kDslParallelThreshold && len > 1) nn::parallel_for_samples(len, slot_kernel);
    else
        for (std::size_t k = 0; k < len; ++k)
            slot_kernel(k);

    r.v_ = r.vec_.data();
    return {};
}

// 归约指令：先递归备好子表达式，再按输出槽对子表达式求值并归约。
// 槽内沿归约轴升序累加 → 与解释器 replay_prefix 逐字节一致。
template <typename C, ExprOp Rop>
[[nodiscard]] inline Result<void> cpu_prepare(const ReduceRef<C, Rop>& r, ComputeEngine& eng,
                                              std::size_t rows, std::size_t cols)
{
    if (r.v_ != nullptr) return {};
    if (auto pr = cpu_prepare(r.child, eng, rows, cols); !pr) return pr;

    using R = ReduceRef<C, Rop>;
    const Scalar init = R::reduces_max ? std::numeric_limits<Scalar>::lowest() : Scalar{0};
    const std::size_t len = R::reduces_rows ? rows : cols;
    r.vec_.assign(len, init);

    const auto slot_kernel = [&](std::size_t slot) noexcept
    {
        Scalar a = init;
        if constexpr (R::reduces_rows)
            for (std::size_t c = 0; c < cols; ++c)
            {
                const Scalar v = eval_with_cols(r.child, slot * cols + c, cols);
                a = R::reduces_max ? std::max(a, v) : a + v;
            }
        else
            for (std::size_t rr = 0; rr < rows; ++rr)
            {
                const Scalar v = eval_with_cols(r.child, rr * cols + slot, cols);
                a = R::reduces_max ? std::max(a, v) : a + v;
            }
        r.vec_[slot] = a;
    };
    if (rows * cols >= kDslParallelThreshold && len > 1) nn::parallel_for_samples(len, slot_kernel);
    else
        for (std::size_t k = 0; k < len; ++k)
            slot_kernel(k);

    r.v_ = r.vec_.data();
    return {};
}

// ── 归约向量原生形状输出（compute_reduce 专用）──────────────────────────
// 根节点是"纯归约"时，输出就是归约向量本身：行归约 → (rows,1)，列归约 → (1,cols)。
// 与 CpuEngine::eval_expr_reduce 的 shapes 约定一致。
template <typename T> inline constexpr bool cpu_reduce_root_v = false;
template <ExprViewKind K> inline constexpr bool cpu_reduce_root_v<ReduceViewRef<K>> = true;
template <typename C, ExprOp Rop> inline constexpr bool cpu_reduce_root_v<ReduceRef<C, Rop>> = true;

[[nodiscard]] inline Tensor copy_reduce_vector(const Scalar* v, bool reduces_rows, std::size_t rows,
                                               std::size_t cols)
{
    Matrix out =
        reduces_rows ? Matrix::make_uninitialized(rows, 1) : Matrix::make_uninitialized(1, cols);
    const std::size_t len = reduces_rows ? rows : cols;
    for (std::size_t k = 0; k < len; ++k)
        out.span()[k] = v[k];
    return TensorAccess::from_matrix(std::move(out));
}

template <ExprViewKind K>
[[nodiscard]] inline Tensor reduce_vector_tensor(const ReduceViewRef<K>& r, std::size_t rows,
                                                 std::size_t cols)
{ return copy_reduce_vector(r.v_, ReduceViewRef<K>::reduces_rows, rows, cols); }

template <typename C, ExprOp Rop>
[[nodiscard]] inline Tensor reduce_vector_tensor(const ReduceRef<C, Rop>& r, std::size_t rows,
                                                 std::size_t cols)
{ return copy_reduce_vector(r.v_, ReduceRef<C, Rop>::reduces_rows, rows, cols); }

// ══════════════════════════════════════════════════════════════════════════
// CPU：编译期模板直接求值（编译器内联 + SIMD 融合，等价手写循环）
// ══════════════════════════════════════════════════════════════════════════
template <typename E>
[[nodiscard]] Tensor eval_cpu(const E& e, std::size_t rows, std::size_t cols,
                              Precision P = Precision::F32)
{
    // 输出会被 eval_into_span 完整覆盖（每个下标恰好写一次）→ 用未初始化构造，
    // 省掉"分配 + 写满一遍零 + 马上被全覆盖"里的那一遍全尺寸零写。
    // 实测本机单线程写满 1.57MB 要 0.50ms（~3.2 GB/s），是纯浪费。
    Matrix out = Matrix::make_uninitialized(rows, cols);
    // eval_into_span 与 algebra_matrix 的逐元素原语（apply/transform）同构：
    // 串行 + 向量化提示 / 阈值以上分块并行，向量化与并行结构一致。
    eval_into_span(e, out.span(), cols);
    // 多精度：f16 目标 = f32 参考求值 + 输出舍入到 f16（§7.2；round-half-to-even
    // 由 f16 赋值语义保证）。f32 目标 = 直通写入，无额外转换。
    if (P == Precision::F16)
    {
        MatrixT<Precision::F16> h(rows, cols);
        const auto s = out.span();
        auto d = h.span();
        for (std::size_t i = 0; i < s.size(); ++i)
            d[i] = s[i];
        return TensorAccess::from_matrix(std::move(h));
    }
    return TensorAccess::from_matrix(std::move(out));
}

// ══════════════════════════════════════════════════════════════════════════
// 扫描期（NN_EXPR_SCAN）校验闸门：折叠出的 ExprSpec 非法 → 立即中止构建
//
// 层侧 dry-run 大多以 (void) 调用，返回的错误会被静默吞掉：若结构本身非法
// （例：裸分组归约视图做根节点 → 空指令表），扫描会"跑完"却不登记任何结构，
// 直到 GPU 运行期才暴露 validate_expr_spec / 注册表 miss（JIT 兜底）——CPU 模板路径不校验，
// 于是这类问题只在 GPU 上出现。扫描模式下统一在此硬失败，把运行期错误前移到构建期。
//
// 退出方式必须是 _Exit 而非 abort：扫描 dry-run 期间线程池 worker 存活，实测
// std::abort() → SIGABRT handler（scan_exprs 装的栈打印，内部做 stacktrace 分配）
// 会**卡死不退出**，构建随之挂死（单线程探针可正常退出 3，问题只在多线程上下文出现）。
// _Exit 立即终止、不碰信号处理器与堆，ninja 拿到非零退出码即判构建失败。
// ══════════════════════════════════════════════════════════════════════════
#ifdef NN_EXPR_SCAN
[[noreturn]] inline void scan_reject(const nn::Error& e)
{
    std::fprintf(stderr, "[scan] validate_expr_spec 失败: %s\n", e.message.c_str());
    std::fflush(nullptr);
    std::_Exit(3);
}

// ── AOT 自登记锚点（"结构 = 表达式类型"）──────────────────────────────────
// 每个 `dsl::compute*` 实例化 odr-use 一个 `FusedAnchor<Expr>`：其**静态初始化期**
// 把"从类型默认构造的符号实例"折叠出的结构登记进全局注册表（去重）。
//
// 与"执行路径捕获"（dry-run 跑 Layer）互补：
//   · dry-run 只覆盖**跑到的**路径（配置分支没跑到就漏）；
//   · 锚点覆盖**编译进来的每个调用点**——调用点在函数体里，函数被编译即实例化，
//     与运行期是否走到该分支无关（因此这是"编译期可达"而非"运行期可达"）。
//
// ⚠ 只登记**结构**：精度签名已不是构建期集合（生成阶段对每个结构发一份
//   运行期精度分派 shader，键 `key#x`，运行期按真实精度填 PC `prec`）——
//   故既不存在 `sig` 形参，也不需要 profile_f32/profile_f16 两遍扫描。
//
// 结构非法（裸视图作根 → 空指令表等）在构建期即 `_Exit(3)`，与 dry-run 同一闸门。
//
// 可用 `-DNN_SCAN_NO_ANCHOR` 关掉锚点做 A/B（只影响登记集合，不影响语义）。
//
// 锚点登记进**独立注册表**：scan_exprs 在结尾把两者合并并打印"锚点独有结构数"
// —— 这是"结构覆盖已不依赖手写清单"的常驻台账（锚点独有 = 手写 dry-run 覆盖
// 不到的调用点；该数突然变大通常意味着新增了未纳入 dry-run 的层路径）。
[[nodiscard]] inline nn::fused::ExprRegistry& anchor_registry()
{
    static nn::fused::ExprRegistry reg;
    return reg;
}

// 锚点：每个被扫描的表达式**类型**实例化一个 `FusedAnchor<Expr>`，其静态
// 初始化期把"从类型默认构造的符号实例"折叠出的结构登记进**锚点注册表**
// （scan_exprs 结尾与 dry-run 注册表合并，见下）。
template <class Expr> struct FusedAnchor
{
    static inline const int reg = []
    {
        const Expr sym{};
        auto [spec, inputs] = to_expr_spec(sym);
        (void)inputs;   // 符号实例：inputs 全是占位张量，注册只用结构
        if (auto v = validate_expr_spec(spec, spec.views.size()); !v) scan_reject(v.error());
        anchor_registry().add(spec);
        return 0;
    }();
};

// fold 锚点：fold spec 由**值构造器**产出（make_fold_*），类型不编码结构——
// FusedAnchor 按类型登记覆盖不到（视图种类/参数是构造实参）。由**消费方**
// 在静态初始化期经本锚点自登记"本调用点实际会构造的结构变体"（k / view
// param 等形状参数不进 key，取代表值即可），与 FusedAnchor 同机制/同注册表：
// **新增 fold 表达式无需改 scan_exprs**（表达式自登记约定）。
struct FoldAnchor
{
    explicit FoldAnchor(ExprSpec s)
    {
        if (auto v = validate_expr_spec(s, s.views.size()); !v) scan_reject(v.error());
        anchor_registry().add(std::move(s));
    }
};

// ── 构建期扫描的单点登记（三个 dsl 入口共用）────────────────────────────
// 折叠表达式 → 校验 → 登记进全局注册表，并返回折叠出的 spec（compute_reduce
// 还要用它判定归约轴）。
// 登记两项：
//   ① **结构**（按 canonical key 去重）——运行期注册表的键；
//   ② **观察到的精度签名**（真实张量精度 + 真实 P）——生成阶段据此发
//      **编译期特化** shader（键 `key#xxxx`，f16 存储 + f32 算术）。这是一个
//      纯优化：热循环里不带 `prec` 三元（实测 CE 融合注意力 −18%）；
//      未枚举到的签名仍由运行期分派变体 `key#x` 兜底。
// 锚点（FusedAnchor，按**类型**登记）由本函数统一 odr-use，保证三个入口的
// 锚点覆盖行为一致（此前三处各写一遍，漏一处 = 该入口的调用点失去编译期可达
// 覆盖，且只在 GPU 注册表 miss（JIT 兜底）时才暴露）。锚点路径的输入是**符号占位张量**
// （默认 f32）→ 其签名恒 0，不会污染特化集合。
template <class Expr>
[[nodiscard]] inline ExprSpec scan_register(const Expr& e, Precision P = Precision::F32)
{
#if !defined(NN_SCAN_NO_ANCHOR)
    (void)FusedAnchor<Expr>::reg;
#endif
    auto [spec, inputs] = to_expr_spec(e);
    if (auto v = validate_expr_spec(spec, inputs.size()); !v) scan_reject(v.error());
    fused::global_registry().add(spec);
    // 签名位：bit i = 第 i 个输入是 f16，bit16 = 输出是 f16（与运行时
    // expr_prec_sig_of / 生成阶段同源）。这里就地算，避免依赖 compute_engine
    // 的 include 顺序（expr_dsl 被 compute_engine 包含）。
    {
        std::uint32_t bits = 0;
        const std::size_t n = inputs.size() < 16u ? inputs.size() : 16u;
        for (std::size_t i = 0; i < n; ++i)
            if (inputs[i].precision() == Precision::F16) bits |= (1u << i);
        fused::global_registry().add_variant(spec, expr_prec_sig_make(bits, P == Precision::F16));
    }
    return spec;
}

#endif   // NN_EXPR_SCAN

// ══════════════════════════════════════════════════════════════════════════
// 统一入口：engine.compute(expr, rows, cols[, P])
//   CPU：编译期模板求值（SIMD 融合）。
//   GPU：AOT 注册表 —— to_expr_spec 折叠 → engine.eval_expr 匹配预生成 shader；
//        未命中默认运行期 JIT 现编（NN_STRICT_CLOSED_WORLD=1 恢复硬报错）。
//
// P = **输出存储精度**（多精度，docs/development/05-mixed-precision.md §8.1）。
//   · 默认 F32：未显式指定即按 f32 求值；Layer 按 §8.5 约定显式传 p_.compute / p_.stable。
//   · f16：CPU 侧 f16 叶子一次性抬到 f32 求值、输出舍入回 f16（§7.2）；
//     GPU 侧由基类 NVI 入口做同样的边界 cast（入口消费 P）。
//   · **不做 Auto 推导**：P 是唯一可见实参，来源可追溯（§8.5 G4）。
// ══════════════════════════════════════════════════════════════════════════
template <typename E>
[[nodiscard]] Result<Tensor> compute(ComputeEngine& eng, const E& e, std::size_t rows,
                                     std::size_t cols,
                                     Precision P)   // 默认实参在 compute_engine.hpp 前置声明处
{
    NN_PROF_OP("dsl::compute");   // CPU 模板路径不经引擎入口，须在此计时（剖析器）
    // 非存储精度（BF16/F64 保留值、T1_58 三值声明）不得作为**算子输出**精度：
    // docs 21 §4.6 规定"T1_58 张量只进量化 GEMM"，其余入口一律走 unsupported
    // 误差路径。此处显式拦下——GPU 侧本来就会在 create/eval 处报错，CPU 侧若
    // 不拦会静默按 f32 建张量（两端语义不一致）。
    if (auto ok = check_precision_supported(P); !ok)
    {
        std::fprintf(stderr, "[dsl] compute 拒绝非存储精度: %s\n", ok.error().message.c_str());
        return Tensor{};
    }
#ifdef NN_EXPR_SCAN
    // 构建期扫描模式：折叠内联表达式的**结构**并登记进全局注册表，
    // 返回占位张量让 dry-run 流程继续（scan 只关心表达式集合，不真算）。
    // 表达式文本仍只出现在 Layer；这里登记的是派生物 ExprSpec。
    // 自登记锚点（按类型登记结构）在 scan_register 内统一处理。
    (void)eng;
    // IR-C：个体结构**恒登记**（录制段内也登记——锚点的
    // 符号实例与运行期实例可能折叠出不同 key，双保险；注册表按 key 去重，
    // 冗余无害。P2 教训：只入图不登记会让未融合回退/单节点 kernel 走 JIT 兜底
    // miss），录制段内再入图（end_expr 时融合并登记复合 spec）。
    const ExprSpec reg_spec = scan_register(e, P);
    if (auto* g = fused::recording_graph())
    {
        auto [spec, inputs] = to_expr_spec(e);
        if (auto v = validate_expr_spec(spec, inputs.size()); !v) scan_reject(v.error());
        const int node = g->add_node(spec, inputs, rows, cols,
                                     /*vector_out=*/false, P);
        Tensor ph = (P == Precision::F16 ? TensorAccess::cpu<Precision::F16>(rows, cols)
                                         : TensorAccess::cpu(rows, cols));
        ph.set_virtual_tag(g->tag_of_node[static_cast<std::size_t>(node)]);
        g->node_outputs[node] = ph;
        return ph;
    }
    (void)reg_spec;
    return (P == Precision::F16 ? TensorAccess::cpu<Precision::F16>(rows, cols)
                                : TensorAccess::cpu(rows, cols));
#else
    if (eng.device() == Device::CPU)
    {
        if constexpr (nn::dsl::has_reduction_v<E>)
        {
            if constexpr (nn::dsl::cpu_preparable_v<E>)
            {
                // 可预绑定：先物化需要全局信息的节点（如 matmul C、归约向量），
                // 其余交编译期模板内联求值（同一个 eval_into_span 循环）。
                // 预绑定只是**优化**：任何前置条件不满足（形状/设备不符等）就
                // 回退解释器（同一表达式的等价求值路径），不引入正确性风险。
                if (auto r = cpu_prepare(e, eng, rows, cols); r)
                    return (eval_cpu(e, rows, cols, P));
            }
            // 含归约且不可预绑定（或预绑定失败）：模板求值无法表达"全行/全列
            // 归约"，折叠成 ExprSpec 走引擎 eval_expr（CPU 扩展语义处理归约
            // 视图/指令）
            auto [spec, inputs] = to_expr_spec(e);
            NN_TRY(v, validate_expr_spec(spec, inputs.size()));
            return eng.eval_expr(spec, inputs, rows, cols, P);
        }
        return (eval_cpu(e, rows, cols, P));
    }

    auto [spec, inputs] = to_expr_spec(e);
    NN_TRY(v, validate_expr_spec(spec, inputs.size()));
    return eng.eval_expr(spec, inputs, rows, cols, P);  // AOT 注册表：GPU 未命中走 JIT 兜底
#endif
}

// ── 无形状重载：dsl::compute(engine, expr[, P]) ────────────────────────────
// 输出网格由表达式推导（口径见上方"输出网格形状推导"）；推导失败 = 明确报错，
// 绝不猜形状。需要非常规网格（如裸行广播向量）时继续用 4/5 参显式形式。
template <typename E>
[[nodiscard]] Result<Tensor> compute(ComputeEngine& eng, const E& e, Precision P)
{
    NN_TRY(rc, infer_grid_shape(e, "dsl::compute"));
    return compute(eng, e, rc->first, rc->second, P);
}

template <typename E> [[nodiscard]] Result<Tensor> compute(ComputeEngine& eng, const E& e)
{ return compute(eng, e, Precision::F32); }

// ── CPU 侧"写进目标张量"（f16 目标 → f32 参考求值 + 舍入写回，§7.2）────────
// f32 目标 = 直通 span 写入（零额外拷贝）。
// 写版本：本函数是 DSL 在 CPU 上**绕过 ComputeEngine 写入口**的唯一落点，
// 故出口处自己记账（TensorAccess::mark_written）—— 参数派生物缓存依赖它。
template <typename E> inline void eval_into_tensor_cpu(const E& e, Tensor& dst)
{
    TensorAccess::mark_written(dst);
    static const auto dbg_max = [](const Matrix& m)
    {
        double mx = 0.0;
        bool bad = false;
        for (auto v : m.span())
        {
            if (!std::isfinite(v)) bad = true;
            else mx = std::max(mx, std::fabs(static_cast<double>(v)));
        }
        return std::pair<double, bool>{mx, bad};
    };
    if (dst.precision() == Precision::F16)
    {
        Matrix tmp = Matrix::make_uninitialized(dst.rows(), dst.cols());
        eval_into_span(e, tmp.span(), dst.cols());
        if (env_flag("NN_F16_DEBUG"))
        {
            const auto [mx, bad] = dbg_max(tmp);
            if (bad || mx > 10.0)
                std::fprintf(stderr,
                             "[dbg][eval_into] tmp=(%zux%zu) max=%.6g%s <<< f16 写回前异常\n",
                             dst.rows(), dst.cols(), mx, bad ? " NONFINITE" : "");
        }
        const auto s = tmp.span();
        auto d = TensorAccess::cpu_matrix<Precision::F16>(dst).span();
        for (std::size_t i = 0; i < s.size(); ++i)
            d[i] = s[i];
        return;
    }
    eval_into_span(e, TensorAccess::cpu_matrix(dst).span(), dst.cols());
}

// ══════════════════════════════════════════════════════════════════════════
// compute_into — 目标传递入口：dst = expr（不分配新张量）
//
// 与 compute() 共用同一前端/同一 IR/同一 AOT 匹配，唯一差别是**输出落点**：
// 结果直接写进调用方提供的 dst。用于把"原地更新"语义纳入 DSL（无需逐操作
// 调用引擎原地原语 add_inplace / scale_inplace 等）：
//   dst += expr            → compute_into(eng, leaf(dst) + expr, dst)
//   dst *= k               → compute_into(eng, leaf(dst) * rparam(k), dst)
//   dst += k * other       → compute_into(eng, leaf(dst) + leaf(other) * rparam(k), dst)
//   dst += row_broadcast(v)→ compute_into(eng, leaf(dst) + row_broadcast(v), dst)
// dst 与某个输入是同一 buffer 是安全的（逐元素先读后写）。
//
// 多精度（§8.3 in-place 特例）：**输出精度 = dst 的存储精度**（不可变）。
// 故本入口没有 P 形参——想改精度必须显式 cast（唯一"变精度"算子）。
//
// CPU 走编译期模板求值（与 compute() 的 eval_cpu 同一路径 + 同一并行门控），
// 因此"原地"不引入任何分配/拷贝；GPU 走 AOT 融合 shader 的 output_override。
// 仅支持逐元素表达式（无归约）；归约向量输出用 compute_reduce。
// ══════════════════════════════════════════════════════════════════════════
template <typename E>
[[nodiscard]] Result<void> compute_into(ComputeEngine& eng, const E& e, Tensor& dst)
{
    NN_PROF_OP("dsl::compute_into");   // CPU 模板路径不经引擎入口，须在此计时（剖析器）
#ifdef NN_EXPR_SCAN
    // 构建期扫描：与 compute() 一样只登记结构（不真算、不关心 dst 的值），
    // 锚点自登记在 scan_register 内统一处理
    (void)eng;
    // 个体结构恒登记（录制段内也登记，双保险——见 compute 的说明）
    (void)scan_register(e, dst.precision());
    // IR-C（P2）：录制段内作为目标传递节点入图（输出 = dst 既有张量，
    // end_expr 的复合 kernel 写回其存储）
    if (auto* g = fused::recording_graph())
    {
        auto [tspec, tinputs] = to_expr_spec(e);
        if (auto v = validate_expr_spec(tspec, tinputs.size()); !v) scan_reject(v.error());
        const int node = g->add_node(tspec, tinputs, dst.rows(), dst.cols(),
                                     /*vector_out=*/false, dst.precision(),
                                     // RV-03：写目标存储标识（同目标写序的显式建边依据）
                                     dst.storage_id());
        g->node_outputs[node] = dst;
        return {};
    }
    (void)dst;
    return {};
#else
    if (eng.device() == Device::CPU)
    {
        if (!dst.is_cpu()) NN_FAIL("dsl::compute_into: dst not on CPU");
        if constexpr (nn::dsl::has_reduction_v<E>)
        {
            // 注意：只在"不含真归约"时才走预绑定路径。含真归约的表达式必须落到
            // 下面的 eval_expr_into，以保持 compute_into 的对外契约
            // （"仅支持逐元素表达式（无归约）"，见 ce_fusion_test）。
            // matmul 段/网格索引不算真归约 → 仍走预绑定（Linear/Conv 反向的
            // grad_w += matmul(...) 就是这一类）。
            if constexpr (nn::dsl::cpu_preparable_v<E> && !nn::dsl::has_real_reduction_v<E>)
            {
                // 可预绑定：物化需要全局信息的节点后，直接内联写进 dst
                // （与纯逐元素分支同一循环结构；dst 与输入同 buffer 安全）。
                // 同 compute()：预绑定失败即回退，不引入正确性风险。
                if (auto r = cpu_prepare(e, eng, dst.rows(), dst.cols()); r)
                {
                    eval_into_tensor_cpu(e, dst);   // f16 dst → f32 参考 + 舍入写回
                    return {};
                }
                else if (nn::dsl::env_flag("NN_F16_DEBUG"))
                {
                    std::fprintf(stderr, "[dbg] compute_into prepare FAILED -> 解释器: %s\n",
                                 r.error().message.c_str());
                }
            }
            // 含归约：折叠成 ExprSpec 走引擎（与 compute() 的 CPU 分支一致）
            auto [spec, inputs] = to_expr_spec(e);
            NN_TRY(v, validate_expr_spec(spec, inputs.size()));
            return eng.eval_expr_into(spec, inputs, dst.rows(), dst.cols(), dst);
        }
        // 纯逐元素：编译期模板直接写进 dst 的 span（零解释器开销、零分配），
        // 与 eval_cpu / 逐元素原语同一循环结构 + 同一并行门控。
        eval_into_tensor_cpu(e, dst);
        return {};
    }

    auto [spec, inputs] = to_expr_spec(e);
    NN_TRY(v, validate_expr_spec(spec, inputs.size()));
    return eng.eval_expr_into(spec, inputs, dst.rows(), dst.cols(), dst);
#endif
}

// ══════════════════════════════════════════════════════════════════════════
// 归约向量原生形状输出：compute_reduce(engine, expr, rows, cols[, P])
//
// 与 compute() 等价，但输出为归约向量本身（(rows,1)/(1,cols)），而非广播到
// (rows,cols)。用于 LayerNorm/RMSNorm 的 (1,B) 统计量缓存（mean/var/rms_inv）
// 与 (F,1) 梯度归约（grad_gamma/grad_beta）——只产出小向量，避免写全尺寸广播。
// 要求表达式归约轴为 0/1（否则引擎报错）。
// P：输出向量精度（§8.1；归约恒 f32 累加 + 输出舍入到 P，§7.3）。
// ══════════════════════════════════════════════════════════════════════════
template <typename E>
[[nodiscard]] Result<Tensor> compute_reduce(ComputeEngine& eng, const E& e, std::size_t rows,
                                            std::size_t cols,
                                            Precision P) // 默认实参在 compute_engine.hpp 前置声明处
{
    NN_PROF_OP("dsl::compute_reduce"); // CPU 模板路径不经引擎入口，须在此计时（剖析器）
    NN_TRY(pc, check_precision_supported(P)); // 同 compute()：拒绝非存储精度
#ifdef NN_EXPR_SCAN
    // 构建期扫描：同 compute()，登记结构（归约轴供下面取占位张量形状）。
    // 占位张量按归约轴取向量形状 (rows,1)/(1,cols)，使 Layer 后续
    // add_inplace 等形状相关操作在 dry-run 中不因形状失配而中断。
    // 锚点自登记在 scan_register 内统一处理。
    (void)eng;
    // 个体结构恒登记（录制段内也登记，双保险——见 compute 的说明）
    const ExprSpec reg_spec = scan_register(e, P);
    // IR-C：录制段内加入图（归约向量占位 + tag）
    if (auto* g = fused::recording_graph())
    {
        auto [rspec, rinputs] = to_expr_spec(e);
        if (auto v = validate_expr_spec(rspec, rinputs.size()); !v) scan_reject(v.error());
        const int raxis0 = expr_spec_reduce_axis(rspec);
        const int node = g->add_node(rspec, rinputs, rows, cols,
                                     /*vector_out=*/true, P);
        Tensor ph =
            (P == Precision::F16 ? ((raxis0 == 0)   ? TensorAccess::cpu<Precision::F16>(rows, 1)
                                    : (raxis0 == 1) ? TensorAccess::cpu<Precision::F16>(1, cols)
                                                    : TensorAccess::cpu<Precision::F16>(rows, cols))
                                 : ((raxis0 == 0)   ? TensorAccess::cpu(rows, 1)
                                    : (raxis0 == 1) ? TensorAccess::cpu(1, cols)
                                                    : TensorAccess::cpu(rows, cols)));
        ph.set_virtual_tag(g->tag_of_node[static_cast<std::size_t>(node)]);
        g->node_outputs[node] = ph;
        return ph;
    }
    const ExprSpec spec = reg_spec;
    const int raxis = expr_spec_reduce_axis(spec);
    if (P == Precision::F16)
        return ((raxis == 0)   ? TensorAccess::cpu<Precision::F16>(rows, 1)
                : (raxis == 1) ? TensorAccess::cpu<Precision::F16>(1, cols)
                               : TensorAccess::cpu<Precision::F16>(rows, cols));
    return ((raxis == 0)   ? TensorAccess::cpu(rows, 1)
            : (raxis == 1) ? TensorAccess::cpu(1, cols)
                           : TensorAccess::cpu(rows, cols));
#else
    if (eng.device() == Device::CPU)
    {
        // 必须用 if constexpr：非归约根节点的 E 不能实例化 reduce_vector_tensor
        if constexpr (nn::dsl::cpu_reduce_root_v<E> && nn::dsl::cpu_preparable_v<E>)
        {
            // 预绑定路径：根节点是纯归约 → 归约向量已算好，直接拷成
            // (rows,1)/(1,cols)，不必经 ExprSpec 解释器。失败即回退。
            if (auto r = cpu_prepare(e, eng, rows, cols); r)
            {
                auto v = reduce_vector_tensor(e, rows, cols);
                if (P == Precision::F32) return (std::move(v));
                // f16 目标：归约向量求值在 f32 参考空间，结果舍入到 f16（§7.3）
                return eng.cast(std::move(v), P);
            }
        }
    }
    auto [spec, inputs] = to_expr_spec(e);
    NN_TRY(v, validate_expr_spec(spec, inputs.size()));
    return eng.eval_expr_reduce(spec, inputs, rows, cols, P);
#endif
}

// ── 无形状重载：dsl::compute_reduce(engine, expr[, P]) ─────────────────────
// 归约向量形状 (rows,1)/(1,cols) 由引擎按归约轴决定，调用方给出的只是**输入
// 网格**；故这里的推导与 compute 同一口径（见"输出网格形状推导"）。
template <typename E>
[[nodiscard]] Result<Tensor> compute_reduce(ComputeEngine& eng, const E& e, Precision P)
{
    NN_TRY(rc, infer_grid_shape(e, "dsl::compute_reduce"));
    return compute_reduce(eng, e, rc->first, rc->second, P);
}

template <typename E> [[nodiscard]] Result<Tensor> compute_reduce(ComputeEngine& eng, const E& e)
{ return compute_reduce(eng, e, Precision::F32); }

// ══════════════════════════════════════════════════════════════════════════
// start_expr / end_expr — 跨行书写同一表达式的语法糖（IR-C 恢复自旧实现）
//
// 与 compute() 等价：内联数学表达式只出现在这里（Layer），框内即一个融合
// 单元（单表达式），end_expr 只是延迟到整块写完再求值。
//   auto out = dsl::end_expr(dsl::start_expr(engine, rows, cols,
//       leaf(a) * leaf(b)
//       + leaf(c) * Scalar{2}
//       - leaf(d)));
// ⚠ 与 ComputeEngine::begin_expr/end_expr（**跨表达式**图录制）不是一回事。
// ══════════════════════════════════════════════════════════════════════════
template <typename E> struct ExprBlock
{
    // 强引用：ExprBlock 存活期间引擎不会析构。
    std::shared_ptr<ComputeEngine> eng;
    std::size_t rows, cols;
    E expr;
};

template <typename E>
[[nodiscard]] ExprBlock<E> start_expr(ComputeEngine& eng, std::size_t rows, std::size_t cols,
                                      const E& e)
{
    auto keepalive = eng.weak_from_this().lock();
    return {std::move(keepalive), rows, cols, e};
}

template <typename E> [[nodiscard]] Result<Tensor> end_expr(const ExprBlock<E>& b)
{
    if (!b.eng) NN_FAIL("dsl::end_expr: ExprBlock 未绑定引擎");
    return compute(*b.eng, b.expr, b.rows, b.cols);
}

} // namespace nn::dsl
