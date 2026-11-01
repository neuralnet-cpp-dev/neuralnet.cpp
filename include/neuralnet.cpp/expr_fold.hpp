#pragma once

// ═══════════════════════════════════════════════════════════════════════════
//  expr_fold.hpp — 分块状态归约（FoldSpec）通用样例构造：fold v1（标量域）地基
//
//  本头只承载**与注意力无关**的通用 fold 样例，是 scan_exprs（AOT 收集
//  dry-run）与 fused_gpu_test / expr_fold_test 对拍的**共享唯一来源**——
//  各方必须构造出结构完全一致的 spec（key 一致），否则注册表查表未命中（走 JIT 兜底）。
//  rowmax/rowsum/softmax_denom 三个 fold v1 样例不被 Layer 使用，保留为状态
//  语义回归锚点；它们的**结构自登记**在文件末尾（`FoldAnchor`，扫描期，
//  与 fold 值构造的既有约定一致——新增/改动样例无需改 scan_exprs）。
//
//  注意力的 fold 构造（make_fold_attn_o / AttnMaskKind）属于 Layer 侧的
//  表达式文本（与 AOT 收集原则"表达式文本只出现在 Layer"一致），定义在
//  compute_layer_attention.hpp，本头不包含任何注意力专属语义。
//
//  共同形状契约：输入 (rows, K)，输出 (rows, 1)；fold.k = K（形状参数）。
//  三个样例的语义增量：
//    1. rowmax  —— 单状态 max 累加（对拍独立逐行标量 max 参考）
//    2. rowsum  —— 单状态 sum 累加（对拍独立逐行标量 sum 参考）
//    3. softmax_denom —— 双状态 online rescale（m 跨块更新 + l = l*α +
//       Σexp(x−m')）：验证状态读写序、拷贝旧状态技巧、body 链内状态广播、
//       两个块归约指令——fold v1 状态语义的全覆盖锚点。
// ═══════════════════════════════════════════════════════════════════════════

#include <limits>

#include "expr_spec.hpp"

namespace nn::expr
{

// 末指令 = 状态自复制（dst 自身 Add 常量 0），把"输出 = 末指令 dst"落到状态上
[[nodiscard]] inline ExprInstr fold_emit_state(std::uint8_t state_reg, std::uint8_t const_zero_slot)
{
    ExprInstr ins;
    ins.op = static_cast<uint8_t>(ExprOp::Add);
    ins.dst = state_reg;
    ins.a = reg(state_reg);
    ins.b = cst(const_zero_slot);
    return ins;
}

// ── 1) fold rowmax：m = max_k x(row, k) ────────────────────────────────────
// body:  [0] blk = RowMax(x)          （沿块内 kb 归约）
//        [1] m   = max(m, Reduce(blk))（写回状态 0）
// finalize: r0 = r0 + c0（状态自复制 → 输出）
[[nodiscard]] inline ExprSpec make_fold_rowmax(std::uint32_t k)
{
    ExprSpec s;
    FoldSpec f;
    f.k = k;
    f.num_state = 1;
    f.inits = {-std::numeric_limits<Scalar>::infinity()};
    ExprInstr b0;                    // blk = RowMax(input 0)
    b0.op = static_cast<uint8_t>(ExprOp::RowMax);
    b0.dst = 1;
    b0.a = input(0);
    b0.b = {};
    ExprInstr b1;                    // m = max(m, Reduce(blk))
    b1.op = static_cast<uint8_t>(ExprOp::Max);
    b1.dst = 0;
    b1.a = reg(0);
    b1.b = reduce(1);
    f.body = {b0, b1};
    f.finalize = {fold_emit_state(0, 0)};
    s.fold = std::move(f);
    s.consts = {Scalar{0}};
    s.num_regs = 2;                  // 状态 0 + 临时 1
    s.views = {linear()};
    return s;
}

// ── 2) fold rowsum：s = Σ_k x(row, k) ──────────────────────────────────────
[[nodiscard]] inline ExprSpec make_fold_rowsum(std::uint32_t k)
{
    ExprSpec s;
    FoldSpec f;
    f.k = k;
    f.num_state = 1;
    f.inits = {Scalar{0}};
    ExprInstr b0;
    b0.op = static_cast<uint8_t>(ExprOp::RowSum);
    b0.dst = 1;
    b0.a = input(0);
    ExprInstr b1;
    b1.op = static_cast<uint8_t>(ExprOp::Add);
    b1.dst = 0;
    b1.a = reg(0);
    b1.b = reduce(1);
    f.body = {b0, b1};
    f.finalize = {fold_emit_state(0, 0)};
    s.fold = std::move(f);
    s.consts = {Scalar{0}};
    s.num_regs = 2;
    s.views = {linear()};
    return s;
}

// ── 3) fold softmax 分母（online 双状态）──────────────────────────────────
// 状态：0 = m（行 max，初值 -inf）、1 = l（移位和，初值 0）
// body（块内网格 x(row, kb)），指令序即状态更新序：
//   [0]  dst2 = m_old 拷贝（m 更新前留存旧值，供 α 与回看）
//   [1]  dst3 = RowMax(x)                       —— 块内行 max
//   [2]  m    = max(dst2, Reduce(dst3))         —— 状态 0 跨块更新
//   [3]  dst4 = dst2 − m                        —— m_old − m'
//   [4]  dst5 = exp(dst4)                       —— rescale 因子 α
//   [5]  dst7 = x − m'（广播）
//   [6]  dst8 = exp(dst7)
//   [7]  dst6 = RowSum(dst8)                    —— 块内 Σexp(x−m')
//   [8]  dst9 = l · α
//   [9]  l    = dst9 + Reduce(dst6)             —— 状态 1 跨块更新
// finalize: 输出 l（状态自复制）
// 参考语义：l_final = Σ_k exp(x(row,k) − max_k x)（浮点结合序容差内等价）。
[[nodiscard]] inline ExprSpec make_fold_softmax_denom(std::uint32_t k)
{
    const auto ins = [](ExprOp op, std::uint8_t dst, ExprOperand a, ExprOperand b = {})
    {
        ExprInstr i;
        i.op = static_cast<uint8_t>(op);
        i.dst = dst;
        i.a = a;
        i.b = b;
        return i;
    };
    ExprSpec s;
    FoldSpec f;
    f.k = k;
    f.num_state = 2;
    f.inits = {-std::numeric_limits<Scalar>::infinity(), Scalar{0}};
    f.body = {
        ins(ExprOp::Add, 2, reg(0), cst(0)),   // m_old 拷贝
        ins(ExprOp::RowMax, 3, input(0)),         // 块内 blk_m
        ins(ExprOp::Max, 0, reg(2), reduce(3)),// m' ← 状态更新
        ins(ExprOp::Sub, 4, reg(2), reg(0)),   // m_old − m'
        ins(ExprOp::Exp, 5, reg(4)),           // α
        ins(ExprOp::Sub, 7, input(0), reg(0)), // x − m'
        ins(ExprOp::Exp, 8, reg(7)),           // exp(x − m')
        ins(ExprOp::RowSum, 6, reg(8)),           // 块内 blk_l
        ins(ExprOp::Mul, 9, reg(1), reg(5)),   // l · α
        ins(ExprOp::Add, 1, reg(9), reduce(6)),// l' ← 状态更新
    };
    f.finalize = {fold_emit_state(1, 0)};
    s.fold = std::move(f);
    s.consts = {Scalar{0}};
    s.num_regs = 10;                             // 状态 0..1 + 临时 2..9
    s.views = {linear()};
    return s;
}

// ── 4) fold logsumexp（online 双状态 → 单值 lse = m + log(l)）──────────────
// body 与 softmax_denom **逐指令同构**（states 0=m/1=l、同 rescale 语义序：
// 复用 make_fold_softmax_denom 的 body/状态/初值），只换两处：
//   - 输入视图由调用方给出（linear = (rows,K) 直读；trans(stride) = 转置
//     直读 (K,rows) 存储——如交叉熵沿词表行归约而 logits 为 (vocab,total)
//     存储；视图 param 走 vp、不进 key → 一份登记覆盖所有形状）
//   - finalize 合成单值 lse = m + log(l)（= log Σ_k exp(x(row,k))，数值稳定：
//     l ≥ 1 ⇒ log l 有限；dst 用临时寄存器，不覆写被读状态）
// 参考语义：lse_final = log Σ_k exp(x(row,k) − max_k x) + max_k x
//   （浮点结合序容差内等价于直接 logsumexp）。
[[nodiscard]] inline ExprSpec make_fold_logsumexp(std::uint32_t k, ExprView input_view = linear())
{
    ExprSpec s = make_fold_softmax_denom(k);     // body/states/inits/consts 同源
    const auto ins = [](ExprOp op, std::uint8_t dst, ExprOperand a, ExprOperand b = {})
    {
        ExprInstr i;
        i.op = static_cast<uint8_t>(op);
        i.dst = dst;
        i.a = a;
        i.b = b;
        return i;
    };
    // finalize：lse = m + log(l)——寄存器 10/11 为 finalize 专用临时
    s.fold->finalize = {
        ins(ExprOp::Log, 10, reg(1)),
        ins(ExprOp::Add, 11, reg(0), reg(10)),
    };
    s.num_regs = 12;                             // 状态 0..1 + body 临时 2..9 + finalize 10..11
    s.views = {input_view};
    return s;
}

} // namespace nn::expr

// ═══════════════════════════════════════════════════════════════════════════
//  扫描期自登记（AOT 收集）：本头三个 v1 样例的结构必须进扫描集合（GPU 对拍
//  与 CPU 用同一构造），而它们不被 Layer 使用、没有别的消费方可以挂锚点 ——
//  故由**定义方**在静态初始化期经 `FoldAnchor` 自登记：新增样例、改样例形状
//  参数都无需改 scan_exprs（`logsumexp` 无自注册项：它只在 compute_loss.hpp
//  的 CE 路径被构造，锚点由该消费方持有）。
//  ⚠ `expr_dsl.hpp`（`FoldAnchor` 所在）只在本扫描段内包含：普通构建里本头
//    仍只依赖 `expr_spec.hpp`（保持轻量）。
// ═══════════════════════════════════════════════════════════════════════════
#if defined(NN_EXPR_SCAN) && !defined(NN_SCAN_NO_ANCHOR)
#include "expr_dsl.hpp"
namespace nn::expr
{
// k（= 本头的唯一形状参数）不进 key → 一个代表值覆盖所有收缩长度。
inline const bool g_fold_sample_anchors = []
{
    (void)dsl::FoldAnchor{make_fold_rowmax(64)};
    (void)dsl::FoldAnchor{make_fold_rowsum(64)};
    (void)dsl::FoldAnchor{make_fold_softmax_denom(64)};
    return true;
}();
} // namespace nn::expr
#endif
