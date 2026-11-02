#pragma once

#include "compute_layer_base.hpp"
#include "compute_layer_mlp.hpp"
#include "compute_layer_softmax.hpp"
#include "compute_position_encoding.hpp"
#include "expr_spec.hpp"

#include <algorithm>
#include <cmath>
#include <cstdio>
#include <iostream>
#include <limits>
#include <memory>
#include <random>
#include <vector>

#include "compute_engine.hpp"
#include "compute_tensor.hpp"
#include "model_spec.hpp"
#include "expr_dsl.hpp"

namespace nn
{

// ═══════════════════════════════════════════════════════════════════════════
//  注意力 fold 构造（双域旗舰样例）：fold attention 输出 O
//  （S 不物化，online 单遍）
//
//  这是**注意力 Layer 自己的表达式文本**（AOT 收集原则：表达式只出现在
//  Layer）：本文件是 make_fold_attn_o 构造与 AttnMaskKind 掩码种类的定义
//  来源，expr_fold.hpp 只含与注意力无关的通用折叠样例。
//  scan_exprs dry-run、fused_gpu/expr_cpu 对拍与 AttentionBase::forward
//  共用本构造 → key 一致。
//
//  数学：O = softmax_masked(Q·Kᵀ) · V_t
//    键域每块：S_tile = mm(Q,K)（内层 dk 收缩）→ [掩码] →
//      m' = max(m, 块 max)；α = e^{m−m'}；e = e^{S−m'}；
//      l = l·α + Σ_块 e；（块尾 vecacc：O *= α；O += Σ_块 e·V_t）
//    向量域：out[d] = O[d] / l
//  布局：Q/K (bh·dk, seq) 行主序；V_t (bh·seq, dk)；输出 (bh·seq, dk)。
//  掩码语义与掩码策略类的 masked_scores() 对齐（Row/Col 按 batched
//  网格：Row = 行%(rows/batch) = 查询位置 i、Col = 全局键位置 j）。
// ═══════════════════════════════════════════════════════════════════════════
namespace expr
{

// 注意力**掩码**语义 —— 只管键的可达性，不含任何位置信息。
//   Plain     无掩码（仅测试/数学对拍用——Layer 恒因果系）
//   Causal    因果（j>i → -inf）
//   CausalDoc 因果 + 文档块对角（doc_col 经 RowBroadcast、doc_ids 经 BatchCol）
// 位置偏置（ALiBi）不属于掩码：它由位置编码策略给出，作为独立的第二个维度
// 传入（score_bias）。两者正交 —— 掩码策略不必知道位置编码的存在。
//
// 掩码清单是**单一真源**（X 宏）：枚举定义与下方 AOT 自登记表
// （`#if defined(NN_EXPR_SCAN)` 段，见 make_fold_attn_o 之后）都由它展开 ——
// 新增一种掩码只需在本清单加一项，scan_exprs 与登记表都无需改动。
#define NN_ATTN_MASK_KIND_LIST(X) \
    X(Plain)                      \
    X(Causal)                     \
    X(CausalDoc)

enum class AttnMaskKind
{
#define NN_ATTN_MASK_KIND_ENUM(name) name,
    NN_ATTN_MASK_KIND_LIST(NN_ATTN_MASK_KIND_ENUM)
#undef NN_ATTN_MASK_KIND_ENUM
};

// fold 构造：掩码 × 位置偏置两个正交维度；生成的 IR 指令顺序固定为
//   掩码（causal → doc）→ ALiBi 斜率项，与拆分前的 5 个融合变体逐指令一致。
[[nodiscard]] inline ExprSpec make_fold_attn_o(std::uint32_t seq, std::uint32_t dk,
                                               std::uint32_t bh, AttnMaskKind mask, bool score_bias,
                                               std::uint32_t kv_ratio = 1)
{
    ExprSpec s;
    FoldSpec f;
    f.k = seq;
    f.num_state = 2;                       // 0 = m, 1 = l
    f.inits = {-std::numeric_limits<Scalar>::infinity(), Scalar{0}};
    f.vec_state_len = dk;
    f.matmul = MatmulSpec{0, 1, 1, 0, dk, bh};  // A=Q(trans), B=K, k=dk, batch=bh
    // 常量：c0 = 0（拷贝/中性元）、c1 = -inf（掩码屏蔽）
    s.consts = {Scalar{0}, -std::numeric_limits<Scalar>::infinity()};
    // 输入/视图槽位（与掩码策略 append_fold_inputs 的追加顺序约定一致）：
    //   0=Q 1=K 2=V_t；[slopes (1,bh)→BatchMod]；[doc_col (BH*seq,1)→RowBroadcast]；
    //   [doc_ids (1,bh*seq)→BatchCol(seq)]
    const bool has_slope = score_bias;
    const bool has_doc = (mask == AttnMaskKind::CausalDoc);
    const bool has_causal = (mask != AttnMaskKind::Plain);
    f.tri_skip = has_causal;   // 生成器据此钳 valid（整块/边界跳过 -inf 区）
    s.views = {linear(), linear(), linear()};
    // GQA（docs 22 §3.2 P2）：K/V_t 只存 bh/kv_ratio 份行块（块映射）
    //   —— 挂成 HeadGroup 视图，比率走运行期 vp 槽（不进 key → 任意 n_rep
    //   共用一份 shader）。kv_ratio==1 时保持 linear()，既有结构逐字节不变。
    if (kv_ratio > 1)
    {
        s.views[1].kind = static_cast<std::uint8_t>(ExprViewKind::HeadGroup);
        s.views[1].param = kv_ratio;
        s.views[2].kind = static_cast<std::uint8_t>(ExprViewKind::HeadGroup);
        s.views[2].param = kv_ratio;
    }
    std::uint8_t slot_slope = 0, slot_dc = 0, slot_ids = 0;
    if (has_slope)
    {
        slot_slope = static_cast<std::uint8_t>(s.views.size());
        s.views.push_back(batch_mod(bh));
    }
    if (has_doc)
    {
        slot_dc = static_cast<std::uint8_t>(s.views.size());
        s.views.push_back(row_broadcast());          // doc_col (rows,1)：b[row]
        slot_ids = static_cast<std::uint8_t>(s.views.size());
        s.views.push_back(batch_col(seq));           // doc_ids：b[batch*seq + col]
    }

    const auto ins = [](ExprOp op, std::uint8_t dst, ExprOperand a, ExprOperand b = {})
    {
        ExprInstr i;
        i.op = static_cast<uint8_t>(op);
        i.dst = dst;
        i.a = a;
        i.b = b;
        return i;
    };
    std::uint8_t nreg = 2;                     // 状态占 0..1，临时从 2 递增
    std::vector<ExprInstr> body;

    // ── 键域前段：S = masked(mm) ──
    const uint8_t s0 = nreg++;                 // S 经 nreg 分配（防与掩码临时撞号）
    body.push_back(ins(ExprOp::Add, s0, matmul_op(), cst(0)));  // r{s0} = S
    std::uint8_t S = s0;
    if (has_causal)
    {
        const uint8_t gt = nreg++;             // Gt(Col, Row)
        body.push_back(ins(ExprOp::Gt, gt, col(), row()));
        const uint8_t sel = nreg++;            // Select(gt, c1=-inf, c0=0)
        {
            ExprInstr isel;                     // 三操作数指令：手填 c 字段
            isel.op = static_cast<uint8_t>(ExprOp::Select);
            isel.dst = sel;
            isel.a = reg(gt);
            isel.b = cst(1);
            isel.c = cst(0);
            body.push_back(isel);
        }
        const uint8_t sm = nreg++;             // S + 屏蔽项
        body.push_back(ins(ExprOp::Add, sm, reg(S), reg(sel)));
        S = sm;
    }
    if (has_doc)
    {
        // 文档块对角：Ne(doc_col[row], doc_ids[batch,col]) → 屏蔽 -inf
        //   （与 CausalDocScoreMask::masked_scores 同构：两层 select 合并因果后统一 -inf）
        const uint8_t ne = nreg++;
        body.push_back(ins(ExprOp::Ne, ne, input(slot_dc), input(slot_ids)));
        const uint8_t ds = nreg++;
        {
            ExprInstr isel;
            isel.op = static_cast<uint8_t>(ExprOp::Select);
            isel.dst = ds;
            isel.a = reg(ne);
            isel.b = cst(1);
            isel.c = cst(0);
            body.push_back(isel);
        }
        const uint8_t sm = nreg++;
        body.push_back(ins(ExprOp::Add, sm, reg(S), reg(ds)));
        S = sm;
    }
    if (has_slope)
    {
        const uint8_t off = nreg++;            // slope[batch] * (Col - Row)
        body.push_back(ins(ExprOp::Sub, off, col(), row()));
        const uint8_t sl = nreg++;
        body.push_back(ins(ExprOp::Mul, sl, input(slot_slope), reg(off)));
        const uint8_t sa = nreg++;
        body.push_back(ins(ExprOp::Add, sa, reg(S), reg(sl)));
        S = sa;
    }

    // ── 键域中段：online m / α / e / l ──
    const uint8_t m_old = nreg++;              // m 拷贝
    body.push_back(ins(ExprOp::Add, m_old, reg(0), cst(0)));
    const uint8_t blk_m = nreg++;              // 块内 S max（归约）
    body.push_back(ins(ExprOp::RowMax, blk_m, reg(S)));
    body.push_back(ins(ExprOp::Max, 0, reg(m_old), reduce(blk_m)));   // m ← 状态更新
    const uint8_t dm = nreg++;                 // m_old − m'
    body.push_back(ins(ExprOp::Sub, dm, reg(m_old), reg(0)));
    const uint8_t alpha = nreg++;              // α（行标量 → vecacc.scale）
    body.push_back(ins(ExprOp::Exp, alpha, reg(dm)));
    const uint8_t es = nreg++;                 // S − m'
    body.push_back(ins(ExprOp::Sub, es, reg(S), reg(0)));
    const uint8_t weight = nreg++;             // e = e^{S−m'}（元素 → vecacc.weight）
    body.push_back(ins(ExprOp::Exp, weight, reg(es)));
    const uint8_t blk_l = nreg++;              // 块内 Σe（归约）
    body.push_back(ins(ExprOp::RowSum, blk_l, reg(weight)));
    const uint8_t la = nreg++;                 // l·α
    body.push_back(ins(ExprOp::Mul, la, reg(1), reg(alpha)));
    body.push_back(ins(ExprOp::Add, 1, reg(la), reduce(blk_l)));      // l ← 状态更新

    // ── vecacc：O *= α；O += Σ_块 e·V_t ──
    f.vecacc = VecAccSpec{0, weight, 2, alpha, 1};
    f.body = std::move(body);
    // ── 向量域 finalize：out[d] = O[d] / l ──
    // dst 必须用**临时寄存器**（新号）：向量域逐列循环执行，若 dst 复用被读
    // 状态（如 l），第 1 列的输出会覆盖除数 → 第 2 列起读到被污染的值
    // （实测 0.4 = 10/25：l=4 被首列输出 25 覆盖）。
    {
        const uint8_t fout = nreg++;
        f.finalize = {ins(ExprOp::Div, fout, nn::expr::vec_state(0), reg(1))};
    }
    s.fold = std::move(f);
    s.num_regs = nreg;
    return s;
}

#if defined(NN_EXPR_SCAN)
// ── AOT 自登记锚点（表达式自登记约定：新增掩码/偏置组合不改 scan_exprs）──
// 注意力 fold 由**值构造器**产出（结构取决于 mask / score_bias / kv_ratio 三个
// 实参），类型层面不编码结构 → `FusedAnchor<Expr>` 按类型登记覆盖不到；层
// forward 又是直调 `engine.eval_expr(make_fold_attn_o(...))`、不经 DSL 钩子。
// 故由本文件（构造与掩码清单的唯一定义来源）在静态初始化期经 `FoldAnchor`
// 自登记**全部**组合（与 compute_loss.hpp 的 CE logsumexp 折叠同一形态）：
//   掩码（`NN_ATTN_MASK_KIND_LIST`）× {无偏置, 位置偏置} × {MHA, GQA}
// 其中"无掩码 + 位置偏置"不是本仓会构造的组合（无层路径），故实际为 5×2 = 10
// 条结构。形状/运行期参数（seq/dk/bh 与 kv_ratio 的具体值）**不进 key** → 一
// 组代表值即覆盖所有形状（docs/internal/22 §3.2 P2；GQA 的 HeadGroup 视图种类进
// key，比本身不进 → MHA/GQA 各一条）。
// 可用 `-DNN_SCAN_NO_ANCHOR` 关掉（与 FusedAnchor 同一 A/B 开关：只影响登记
// 集合、不改语义）。
#if !defined(NN_SCAN_NO_ANCHOR)
namespace attn_fold_anchor
{
inline constexpr AttnMaskKind kMaskKinds[] = {
#define NN_ATTN_MASK_KIND_ITEM(name) AttnMaskKind::name,
    NN_ATTN_MASK_KIND_LIST(NN_ATTN_MASK_KIND_ITEM)
#undef NN_ATTN_MASK_KIND_ITEM
};

// 登记表 = 本层实际会构造的全部组合。形状取代表值（k/dk/bh/kv_ratio 均不进
// key；这里的取值与既有登记块一致，便于逐字节比对生成物）。
[[nodiscard]] inline bool register_all()
{
    constexpr std::uint32_t seq = 64, dk = 2, bh = 2;
    for (const AttnMaskKind mask : kMaskKinds)
    {
        for (const bool score_bias : {false, true})
        {
            if (mask == AttnMaskKind::Plain && score_bias)
                continue;   // 无掩码 + 位置偏置：本仓不构造该组合
            for (const std::uint32_t kv_ratio : {1u, 2u})
                (void)dsl::FoldAnchor{make_fold_attn_o(seq, dk, bh, mask, score_bias, kv_ratio)};
        }
    }
    return true;
}
} // namespace attn_fold_anchor

inline const bool g_attn_fold_anchors = attn_fold_anchor::register_all();
#endif   // !NN_SCAN_NO_ANCHOR
#endif   // NN_EXPR_SCAN

} // namespace expr

// ═══════════════════════════════════════════════════════════════════════════
//  AttnScoreMask — 注意力**掩码策略**（一种具体策略 = 一种掩码语义）
//
//  职责边界（本轮拆分的要点）：**只做掩码**，不含任何位置信息。
//    · 因果掩码 / 文档块对角是"键能不能被看到"——注意力自己的事；
//    · ALiBi 是"位置带来的分数偏移"——位置编码的事（AlibiPositionEncoder）。
//  两者正交：`masked_scores()` 产出**掩码后**的 S，位置偏置由
//  `PositionEncoder::apply_score_bias()` 在"掩码之后、softmax 之前"独立叠加。
//  于是本族不必知道 `PositionEncoder` 的存在——旧版的 `CausalAlibiScoreMask`
//  / `CausalAlibiDocScoreMask` 正是把两者融成一条 select 的产物，已删除。
//
//  为什么是策略对象而不是基类里的一串 if：
//    掩码语义（无掩码 / 因果 / 因果+文档）在**构造期**就确定，旧实现却把判定
//    留在热路径（`recompute_W_` 每次反向重跑组合链）。现在：具体策略类在配置期
//    选定（工厂 `make_score_mask_()` 在构造 / `set_doc_ids` 里跑一次），
//    forward/backward 只做一次虚调用。
//
//  接口（全部在"每调用一次"粒度，不在块内循环）：
//    mask_kind()          → forward fold kernel 的掩码种类（类级常量）
//    prepare()            → 构建本策略的掩码输入张量（文档 id / 列）
//    append_fold_inputs() → 按 make_fold_attn_o 的 views 顺序追加 fold 输入
//    masked_scores()      → 反向重算 S 的 DSL 文本（与 fold 掩码语义同构）
//
//  AOT 注册表：每条 masked_scores() 的表达式文本都必须被 scan_exprs 的
//  对应掩码 dry-run 覆盖。
// ═══════════════════════════════════════════════════════════════════════════
class AttnScoreMask
{
protected:
    AttnScoreMask() = default;

public:
    virtual ~AttnScoreMask() = default;
    AttnScoreMask(const AttnScoreMask&) = delete;
    AttnScoreMask& operator=(const AttnScoreMask&) = delete;

    // forward fold kernel 的掩码种类（类级常量，构造期定型）
    [[nodiscard]] virtual expr::AttnMaskKind mask_kind() const noexcept = 0;

    // 每步准备掩码输入张量（无掩码分量 = no-op）
    [[nodiscard]] virtual Result<void> prepare(ComputeEngine& /*engine*/, std::size_t /*batch*/,
                                               std::size_t /*seq*/)
    { return {}; }

    // fold 输入追加：顺序必须与 make_fold_attn_o 的 views 顺序一致
    // （Q,K,V_t 之后；位置偏置输入由 PositionEncoder 先行追加，故本函数在它之后调）
    virtual void append_fold_inputs(std::vector<Tensor>& /*io*/) const {}

    // 反向：S = mask(Q·Kᵀ)（DSL 文本 —— 与 forward fold 掩码语义同构；
    //   位置偏置由位置编码策略另行叠加，见 PositionEncoder::apply_score_bias）
    [[nodiscard]] virtual Result<Tensor> masked_scores(ComputeEngine& engine, const Tensor& Q,
                                                       const Tensor& K, std::size_t BH,
                                                       std::size_t seq, const PrecisionProfile& p,
                                                       std::uint32_t kv_ratio) const = 0;

    // 文档 id 注入（仅文档感知策略覆写；其余 no-op = 无文档掩码）
    virtual void set_doc_ids(std::span<const std::size_t> /*ids*/) {}
};

// ── 无掩码（双向）：MHA ──────────────────────────────────────────────────
class PlainScoreMask final : public AttnScoreMask
{
public:
    [[nodiscard]] expr::AttnMaskKind mask_kind() const noexcept override
    { return expr::AttnMaskKind::Plain; }

    [[nodiscard]] Result<Tensor> masked_scores(ComputeEngine& engine, const Tensor& Q,
                                               const Tensor& K, std::size_t BH, std::size_t /*seq*/,
                                               const PrecisionProfile& p,
                                               std::uint32_t kv_ratio) const override
    {
        return dsl::compute(engine, dsl::matmul_kv(Q, K, true, false, BH, 1, kv_ratio),
                            p.compute);   // 输出 (BH·seq, seq) 由 matmul 段推导
    }
};

// ── 因果掩码（j > i → -inf）──────────────────────────────────────────────
// 表达式文本逐字保留（AOT key 不变）；文档变体继承本类（因果是底座）。
class CausalScoreMask : public AttnScoreMask
{
public:
    static constexpr Scalar kNegInf = -std::numeric_limits<Scalar>::infinity();

    [[nodiscard]] expr::AttnMaskKind mask_kind() const noexcept override
    { return expr::AttnMaskKind::Causal; }

    [[nodiscard]] Result<Tensor> masked_scores(ComputeEngine& engine, const Tensor& Q,
                                               const Tensor& K, std::size_t BH, std::size_t seq,
                                               const PrecisionProfile& p,
                                               std::uint32_t kv_ratio) const override
    {
        const auto scores = dsl::matmul_kv(Q, K, true, false, BH, 1, kv_ratio);
        const auto causal = dsl::select(dsl::col() > dsl::row(), Scalar{1}, Scalar{0});
        return dsl::compute(engine, scores + dsl::select(causal != Scalar{0}, kNegInf, Scalar{0}),
                            BH * seq, seq, p.compute);
    }
};

// ── 因果 + 文档块对角（跨文档禁止注意）──────────────────────────────────
class CausalDocScoreMask final : public CausalScoreMask
{
protected:
    std::size_t num_heads_;
    std::vector<std::size_t> doc_ids_;   // 批内每位置文档 id（batch-major）
    bool has_doc_ids_ = false;
    Tensor doc_ids_cache_;   // (1, BH*seq)：每 (b,h) 块重复 doc_ids[b*seq..]
    Tensor doc_col_;         // (BH*seq, 1)：每行文档 id（跨 head 重复）

public:
    explicit CausalDocScoreMask(std::size_t num_heads) : num_heads_(num_heads) {}

    void set_doc_ids(std::span<const std::size_t> ids) override
    {
        if (ids.empty())
        {
            doc_ids_.clear();
            has_doc_ids_ = false;
            return;
        }
        doc_ids_.assign(ids.begin(), ids.end());
        has_doc_ids_ = true;
    }

    [[nodiscard]] bool doc_mask_enabled() const noexcept { return has_doc_ids_; }

    [[nodiscard]] expr::AttnMaskKind mask_kind() const noexcept override
    { return expr::AttnMaskKind::CausalDoc; }

    [[nodiscard]] Result<void> prepare(ComputeEngine& engine, std::size_t batch,
                                       std::size_t seq) override
    {
        // 文档感知：doc_ids_ 每 step 变化，每步重建（小张量 O(BH*seq)）。
        // doc_ids_cache_ 为 (1, BH*seq) 布局——每 (b,h) 块重复 doc_ids[b*seq..]
        //   （BatchCol 视图的 batch 下标 = BH 网格下标，故不能用 (1,batch*seq)）
        // doc_col_（(BH*seq,1)）每行文档 id（跨 head 重复；IR 掩码按行广播读取）。
        //   两者数值相同，共用一份宿主缓冲、按不同形状上传两次。
        const std::size_t BH = batch * num_heads_;
        std::vector<Scalar> d(BH * seq);   // 宿主桥（17 §3 D11）
        for (std::size_t b = 0; b < batch; ++b)
            for (std::size_t h = 0; h < num_heads_; ++h)
                for (std::size_t i = 0; i < seq; ++i)
                    d[(b * num_heads_ + h) * seq + i] = static_cast<Scalar>(doc_ids_[b * seq + i]);
        auto t = detail::upload_span(engine, 1, BH * seq, Precision::F32, std::span(d));
        NN_TRY_CHECK(t);
        doc_ids_cache_ = std::move(*t);
        if (doc_ids_cache_.is_gpu())
        {
            // GPU：复用同一份上传数据，在设备内完成形状变换，避免第二次
            // staging upload 触发 batch drain。
            auto tc = engine.transpose(doc_ids_cache_);
            NN_TRY_CHECK(tc);
            doc_col_ = std::move(*tc);
        }
        else
        {
            // CPU：直接构造目标形状，避免为一个小表引入额外转置遍历。
            auto tc = detail::upload_span(engine, BH * seq, 1, Precision::F32, std::span(d));
            NN_TRY_CHECK(tc);
            doc_col_ = std::move(*tc);
        }
        return {};
    }

    void append_fold_inputs(std::vector<Tensor>& io) const override
    {
        io.push_back(doc_col_);
        io.push_back(doc_ids_cache_);
    }

    [[nodiscard]] Result<Tensor> masked_scores(ComputeEngine& engine, const Tensor& Q,
                                               const Tensor& K, std::size_t BH, std::size_t seq,
                                               const PrecisionProfile& p,
                                               std::uint32_t kv_ratio) const override
    {
        const auto scores = dsl::matmul_kv(Q, K, true, false, BH, 1, kv_ratio);
        const auto causal = dsl::select(dsl::col() > dsl::row(), Scalar{1}, Scalar{0});
        const auto blocked = causal + dsl::select(dsl::row_broadcast(doc_col_) !=
                                                      dsl::batch_col(doc_ids_cache_, seq),
                                                  Scalar{1}, Scalar{0});
        return dsl::compute(engine, scores + dsl::select(blocked != Scalar{0}, kNegInf, Scalar{0}),
                            BH * seq, seq, p.compute);
    }
};

// ═══════════════════════════════════════════════════════════════════════════
//  AttentionBase — 多头注意力**核心**（批量化：消除 per-head / per-sample 循环）
//
//  职责只剩"注意力数学本身"，两类可变量各由**一个构造期定型的策略对象**承载，
//  基类里不再有 use_rope_ / use_alibi_ / use_doc_ids_ 之类的标志位：
//
//    · PositionEncoder（位置编码，见 compute_position_encoding.hpp）
//        - apply_qk()/apply_qk_step() → RoPE 旋转 Q/K
//        - apply_score_bias()/apply_bias_step() → ALiBi 分数偏置（原地叠加）
//        - 其余编码类型在注意力侧为 no-op → 热路径无任何判断
//    · AttnScoreMask（**掩码**，见上；与位置编码正交）
//        - 构造期/配置期由 make_score_mask_() 选定，前/反向各一次虚调用
//
//  算法（只在此处，不在 Engine/Shader）：
//    Q = W_q × x, K = W_k × x, V = W_v × x  (三个 Linear 投影)
//    Q/K/V: (H*d_k, batch*seq) — 头维度在行方向，batch 在列方向
//    rearrange_3d → (batch*H*d_k, seq)，单次处理所有样本和所有头。
//
//    forward（单 fold 路径，S 不物化）：
//      Q/K = rearrange_3d → (batch*H*d_k, seq)；[位置编码]；Q *= scale（折进 Q）
//      V_t = transpose + rearrange → (BH*seq, d_k)
//      O_t = eval_expr(make_fold_attn_o(..., mask_kind, has_score_bias),
//                      {Q, K, V_t, [slopes], [掩码输入]}, BH*seq, d_k)
//        —— QKᵀ/掩码/位置偏置/online softmax/ΣwV 全在单个 fold kernel 内逐块完成
//      O = transpose + rearrange 回 (H*d_k, batch*seq)；out = W_o × O
//    backward：S = mask(Q·Kᵀ) → S += bias(S)（原地）→ softmax，随后 R/X 表达式
//      + batched_matmul。两条链各一次虚调用、互相独立。
//
//  输入形状: (d_model, batch * seq_len)，输出形状: (d_model, batch * seq_len)
//    seq_len 由构造函数指定，batch = input.cols() / seq_len 在 forward 时推断
// ═══════════════════════════════════════════════════════════════════════════
class AttentionBase : public Layer
{
public:
    [[nodiscard]] const char* layer_name() const noexcept override { return "Attention"; }

protected:
    std::size_t d_model_;
    std::size_t num_heads_;
    // ── GQA（分组查询注意力，docs/internal/22 §3.2）─────────────────────
    // n_head_kv_ == num_heads_ 时退化为 MHA（既有路径逐位不变）。
    // 头映射 = 块映射：query head h 用 KV head `h / (num_heads_/n_head_kv_)`
    //（llama.cpp FA 内核 `ik2 = iq2 / rk2` 与 HF `repeat_kv` 的 reshape 一致）。
    std::size_t n_head_kv_ = 0;
    // GQA 头分组比 = num_heads_ / n_head_kv_（1 = MHA，= head_mapping 的 n_rep）
    std::size_t kv_ratio_ = 1;
    // 展开索引表：(num_heads·d_k, 1) 宿主常量（detail::upload_span 上桥）。
    // 前向 gather_rows(K_kv) → K_full；反向 scatter_add_rows(该表) → grad_K_kv。
    // MHA 时 invalid（不建表、零开销）。
    Tensor gqa_expand_idx_;
    std::size_t d_k_;
    std::size_t seq_len_;   // 单样本序列长度（0 = 单样本，cols 即 seq）
    Scalar scale_;

    // ── 线性投影走工厂（P1.5 docs 21 §4.8.3）：weight_quant=T1_58 → BitLinear。
    //    成员类型 = std::unique_ptr<Layer>（与 attn_sub_norm_ 同一形态）。
    //    Linear(in_features, out_features)：GQA 只收窄**输出**宽度（见构造器）。
    std::unique_ptr<Layer> w_q_;
    std::unique_ptr<Layer> w_k_;
    std::unique_ptr<Layer> w_v_;
    std::unique_ptr<Layer> w_o_;
    // 三值模式（构造期定型；决定 4 个投影的**具体类型**与 profile 分流）
    WeightQuant weight_quant_ = WeightQuant::None;
    Softmax softmax_;

    // ── 位置编码策略（**注意力层自持**，构造期由子类经
    //   install_position_encoder() 装入）────────────────────────────────
    //   注意力侧只有 RoPE（Q/K 旋转）与 ALiBi（分数偏置）会实做，其余类型由
    //   工厂映射为恒等策略 → 热路径里没有任何按编码类型的分支。
    //   默认恒等：AttentionBase/MultiHeadAttention 不装可用的编码器也对。
    //   （嵌入侧的 Learned/Sinusoidal 归模型所有，见
    //   make_embedding_position_encoder。）
    std::unique_ptr<PositionEncoder> pos_ = std::make_unique<NoPositionEncoder>();

    // ── 分数掩码策略（构造期/配置期定型；热路径只调用，不判断变体）──
    std::unique_ptr<AttnScoreMask> mask_;

    // ── SubLN（BitNet b1.58 的"子层归一化"，docs/internal/22 §3.1）──────
    // **子层内部**的额外归一化：挂在 attention 输出（宽 d_model）与输出投影
    // w_o_ 之间。默认 nullptr = 关（既有路径逐位不变）。类型跟随模型的
    // norm_type（2B4T = RMSNorm）——与 GPTBlock 的 norm1_/norm2_ 同一工厂。
    //
    // 位置：注意力输出 → **attn_sub_norm_ → w_o_**。不能挂到 block 级：
    // block 只看到 w_o_ 之后的 (d_model, N)，看不到投影前的 concat。
    std::unique_ptr<Layer> attn_sub_norm_;

    // forward 缓存（rearranged 版本，供 backward 直接使用；得分矩阵类量
    // 不作缓存——W/m/l/attn 均不物化，W 在 backward 重算）
    Tensor Q_cache_, K_cache_, V_cache_;  // (batch*H*d_k, seq) rearranged

    // ── 掩码策略工厂 ────────────────────────────────────────────────────
    //  子类按自己的掩码语义覆写；只在**配置期**调用（构造 / set_doc_ids），
    //  不在 forward/backward 里调用。
    //  fail-safe 默认 = 无掩码（双向），与旧 fold_mask_variant_ 默认 Plain 一致。
    [[nodiscard]] virtual std::unique_ptr<AttnScoreMask> make_score_mask_() const
    { return std::make_unique<PlainScoreMask>(); }

    void install_score_mask_() { mask_ = make_score_mask_(); }

    [[nodiscard]] AttnScoreMask& score_mask() noexcept
    {
        // RV-01：失败后 `return *mask_` 解引用空指针 → 无条件终止
        NN_ASSERT_ALWAYS(mask_ != nullptr, "AttentionBase: score mask not installed");
        return *mask_;
    }

    // ── 配置期（子类构造器内）：装入注意力侧位置编码策略 ─────────────────
    //  注意力侧的位置编码（RoPE 的 Q/K 旋转、ALiBi 的分数偏置）**由本层自持**；
    //  嵌入侧（Learned/Sinusoidal）归模型，经 make_embedding_position_encoder
    //  在模型侧施加。
    //  注意：本函数**不**再定型掩码策略——掩码（因果/文档）与位置偏置已经正交，
    //  掩码策略由子类独立安装（`install_score_mask_()`），不再依赖位置编码。
    void install_position_encoder(std::unique_ptr<PositionEncoder> enc)
    {
        pos_ = std::move(enc);
        // RV-01：失败后 `pos_->set_precision_profile` 解引用空指针 → 无条件终止
        NN_ASSERT_ALWAYS(pos_ != nullptr, "AttentionBase: position encoder required");
        pos_->set_precision_profile(p_);
    }

public:
    AttentionBase(std::size_t d_model, std::size_t num_heads, std::size_t seq_len = 0,
                  bool subln = false, NormType subln_norm_type = NormType::LayerNorm,
                  std::size_t n_head_kv = 0, WeightQuant weight_quant = WeightQuant::None,
                  bool inference_only = false)
        : d_model_(d_model), num_heads_(num_heads),
          n_head_kv_(n_head_kv == 0 ? num_heads : n_head_kv),
          kv_ratio_(num_heads / (n_head_kv == 0 ? num_heads : n_head_kv)),
          d_k_(d_model / num_heads), seq_len_(seq_len),
          scale_(Scalar{1} / std::sqrt(static_cast<Scalar>(d_model / num_heads))),
          w_q_(make_linear_layer(d_model, d_model, weight_quant, inference_only)),
          // Linear(in_features, out_features)：GQA 只收窄**输出**宽度
          // （K/V 的 out = n_head_kv·d_k），输入侧仍是 d_model。
          w_k_(make_linear_layer(d_model,
                                 (n_head_kv == 0 ? num_heads : n_head_kv) * (d_model / num_heads),
                                 weight_quant, inference_only)),
          w_v_(make_linear_layer(d_model,
                                 (n_head_kv == 0 ? num_heads : n_head_kv) * (d_model / num_heads),
                                 weight_quant, inference_only)),
          w_o_(make_linear_layer(d_model, d_model, weight_quant, inference_only)),
          weight_quant_(weight_quant)
    {
        NN_ASSERT_ALWAYS(d_model % num_heads == 0,
                         "AttentionBase: d_model must be divisible by num_heads");
        NN_ASSERT_ALWAYS(n_head_kv_ != 0 && num_heads % n_head_kv_ == 0,
                         "AttentionBase: num_heads must be divisible by n_head_kv");
        mask_ = std::make_unique<PlainScoreMask>();
        if (subln) attn_sub_norm_ = make_norm_layer(d_model, subln_norm_type);
    }

    [[nodiscard]] PositionEncoder& position_encoder() noexcept { return *pos_; }
    [[nodiscard]] const PositionEncoder& position_encoder() const noexcept { return *pos_; }

    // ── D7：精度配置下传（§9.2）──────────────────────────────────────────
    // 注意力是复合层（4 个投影 Linear + Softmax + 位置编码）；子层/辅助对象必须
    // 一起拿到 profile，否则它们的 p_ 停在默认 F32：参数仍按 F32 创建、
    // DSL 求值退回 F32 —— f16 配置下静默失效。
    //
    // ── P1.5 三值分流（docs 21 §4.8.3）───────────────────────────────────
    // `weight_quant_ = T1_58` 时 4 个投影是 BitLinear，拿 param=T1_58 的 profile；
    // 本层自身（不持有三值权重）与 softmax/位置编码/SubLN 拿 param 归一化为 f32
    // 的那一份。非三值模式 split 退化为恒等 → 逐位不变。
    void set_precision_profile(const PrecisionProfile& profile) override
    {
        const TernaryProfileSplit sp =
            split_ternary_profile(layer_name(), profile, weight_quant_ == WeightQuant::T1_58);
        Layer::set_precision_profile(sp.self);
        w_q_->set_precision_profile(sp.linear);
        w_k_->set_precision_profile(sp.linear);
        w_v_->set_precision_profile(sp.linear);
        w_o_->set_precision_profile(sp.linear);
        softmax_.set_precision_profile(sp.self);
        pos_->set_precision_profile(sp.self);   // 位置编码（RoPE 表 / ALiBi 斜率）
        if (attn_sub_norm_) attn_sub_norm_->set_precision_profile(sp.self);
    }

    [[nodiscard]] Result<void> init_impl(ComputeEngine& engine) override
    {
        NN_TRY(r1, w_q_->init(engine));
        NN_TRY(r2, w_k_->init(engine));
        NN_TRY(r3, w_v_->init(engine));
        NN_TRY(r4, w_o_->init(engine));
        // GQA 展开索引（铁律 #12 允许的"层自算辅助数据：索引表"）。
        // 块映射：n_rep 个连续 query head 共享一个 KV head。
        if (n_head_kv_ != num_heads_)
        {
            const std::size_t n_rep = num_heads_ / n_head_kv_;
            std::vector<Scalar> idx(num_heads_ * d_k_);
            for (std::size_t h = 0; h < num_heads_; ++h)
            {
                const std::size_t src = (h / n_rep) * d_k_;
                for (std::size_t r = 0; r < d_k_; ++r)
                    idx[h * d_k_ + r] = static_cast<Scalar>(src + r);
            }
            NN_TRY(gi, detail::upload_span(engine, num_heads_ * d_k_, 1, Precision::F32, idx));
            gqa_expand_idx_ = std::move(*gi);
        }
        // M6 段 C：softmax_ 是子 Layer（engine 由 init 绑定），否则 forward 内 fail-fast
        {
            NN_TRY(r6, softmax_.init(engine));
        }
        // 注意力侧位置编码（RoPE/ALiBi 的 init 是 no-op；恒等策略同样 no-op）——
        // 按 M6 段 C 的不变量"复合层 init_impl 必须 init 全部子对象"统一调用。
        if (attn_sub_norm_) { NN_TRY(r7, attn_sub_norm_->init(engine)); }
        return pos_->init(engine);
    }

    std::vector<TensorRef> parameters() override
    {
        auto r = collect_refs(w_q_->parameters(), w_k_->parameters(), w_v_->parameters(),
                              w_o_->parameters());
        if (attn_sub_norm_)
        {
            auto s = attn_sub_norm_->parameters();
            r.insert(r.end(), s.begin(), s.end());
        }
        return r;
    }

    // 子层结构（部署格式的完整遍历；顺序 = 上面 `parameters()` 的拼接顺序）
    [[nodiscard]] std::vector<Layer*> param_children() noexcept override
    {
        std::vector<Layer*> r{w_q_.get(), w_k_.get(), w_v_.get(), w_o_.get()};
        if (attn_sub_norm_) r.push_back(attn_sub_norm_.get());
        return r;
    }

    std::vector<TensorRef> param_gradients() override
    {
        auto r = collect_refs(w_q_->param_gradients(), w_k_->param_gradients(),
                              w_v_->param_gradients(), w_o_->param_gradients());
        if (attn_sub_norm_)
        {
            auto s = attn_sub_norm_->param_gradients();
            r.insert(r.end(), s.begin(), s.end());
        }
        return r;
    }

    // 梯度检查点：把模式传播给内部投影层与 softmax
    void set_checkpoint_mode(bool enabled) override
    {
        Layer::set_checkpoint_mode(enabled);
        w_q_->set_checkpoint_mode(enabled);
        w_k_->set_checkpoint_mode(enabled);
        w_v_->set_checkpoint_mode(enabled);
        w_o_->set_checkpoint_mode(enabled);
        softmax_.set_checkpoint_mode(enabled);
        if (attn_sub_norm_) attn_sub_norm_->set_checkpoint_mode(enabled);
    }

    // 文档感知：转发给掩码策略（非文档策略 = no-op，与旧"无 doc 钩子"一致）
    void set_doc_ids(std::span<const std::size_t> ids) override { score_mask().set_doc_ids(ids); }

    void clear_cache() override
    {
        Q_cache_ = Tensor{};
        K_cache_ = Tensor{};
        V_cache_ = Tensor{};
        // 掩码/偏置描述子（掩码策略持有的 doc/slopes 缓存）小而常驻，
        // 不随激活清理
        w_q_->clear_cache();
        w_k_->clear_cache();
        w_v_->clear_cache();
        w_o_->clear_cache();
        softmax_.clear_cache();
        if (attn_sub_norm_) attn_sub_norm_->clear_cache();
    }

    std::vector<TensorRef> activation_cache() override
    {
        std::vector<TensorRef> r;
        if (Q_cache_.valid()) r.emplace_back(Q_cache_);
        if (K_cache_.valid()) r.emplace_back(K_cache_);
        if (V_cache_.valid()) r.emplace_back(V_cache_);
        auto wq = w_q_->activation_cache();
        r.insert(r.end(), wq.begin(), wq.end());
        auto wk = w_k_->activation_cache();
        r.insert(r.end(), wk.begin(), wk.end());
        auto wv = w_v_->activation_cache();
        r.insert(r.end(), wv.begin(), wv.end());
        auto wo = w_o_->activation_cache();
        r.insert(r.end(), wo.begin(), wo.end());
        auto sm = softmax_.activation_cache();
        r.insert(r.end(), sm.begin(), sm.end());
        if (attn_sub_norm_)
        {
            auto sn = attn_sub_norm_->activation_cache();
            r.insert(r.end(), sn.begin(), sn.end());
        }
        return r;
    }

    [[nodiscard]] Result<Tensor> forward(const Tensor& input) override
    {
        ComputeEngine& engine = engine_ref();
        if (input.rows() != d_model_) NN_FAIL("AttentionBase forward: input shape mismatch");
        const std::size_t total_seq = input.cols();
        const std::size_t seq = (seq_len_ > 0) ? seq_len_ : total_seq;
        const std::size_t batch = (seq_len_ > 0) ? (total_seq / seq_len_) : 1;
        if (total_seq != batch * seq)
            NN_FAIL("AttentionBase forward: cols not divisible by seq_len");
        // 1. 线性投影 → Q/K/V: (H*d_k, batch*seq)
        NN_TRY(q_res, w_q_->forward(input));
        NN_TRY(k_proj, w_k_->forward(input));
        NN_TRY(v_proj, w_v_->forward(input));

        // 1.5 GQA：把 K/V 从 n_head_kv 个头展开到 num_heads 个（块映射）。
        //     MHA（表 invalid）= 恒等搬移，零额外拷贝；展开后 fold 注意力与
        //     AOT 注册表完全不知情（BH 恒 = batch·num_heads）。
        // GQA（P2）：**训练路径不展开 K/V** —— 头映射由 fold 的 HeadGroup 视图在
        // kernel 内完成（省掉 n_rep 倍物化 + 两次全尺寸 gather + 两个全尺寸
        // 重排缓冲）。展开表 gqa_expand_idx_ 仅供增量推理（forward_step 的
        // KV cache 仍按 H 个头布局）。
        Tensor k_res = std::move(*k_proj);
        Tensor v_res = std::move(*v_proj);

        // 2. rearrange: (H*d_k, batch*seq) → (batch*H*d_k, seq)
        //    使 batched_matmul 能按 batch*H 切分行块
        //    局部 Q/K/V 承载 forward 计算；仅在非 checkpoint 模式下写入成员缓存。
        const std::size_t H_dk = num_heads_ * d_k_;
        const std::size_t KV_dk = n_head_kv_ * d_k_;
        Tensor Q, K, V;  // (batch*H*d_k, seq) rearranged
        if (batch > 1)
        {
            NN_TRY(qr, engine.rearrange_3d(*q_res, H_dk, batch, seq, false));
            Q = std::move(*qr);
            // GQA（P2，in-kernel 头映射）：K/V 保持 n_head_kv 个头**不展开**
            //   —— 展开由 fold 的 HeadGroup 视图在 kernel 内完成（省掉 n_rep 倍
            //   物化与两次全尺寸 gather；见 docs 22 §3.2）。
            NN_TRY(kr, engine.rearrange_3d(k_res, KV_dk, batch, seq, false));
            K = std::move(*kr);
            NN_TRY(vr, engine.rearrange_3d(v_res, KV_dk, batch, seq, false));
            V = std::move(*vr);
        }
        else
        {
            // batch=1: rearrange 是恒等拷贝，跳过
            Q = std::move(*q_res);
            K = std::move(k_res);
            V = std::move(v_res);
        }

        // 2.5 位置编码：对 Q/K 施加旋转位置编码（rearrange 后列=position，
        //     每 d_k 行一个头，cos/sin 短表按 RowMod 平铺）。
        //     非 RoPE 编码在注意力侧是恒等策略 → 这里无标志位判断。
        {
            NN_TRY(qe, pos_->apply_qk(engine, Q, seq, /*backward=*/false));
            NN_TRY(ke, pos_->apply_qk(engine, K, seq, /*backward=*/false));
        }
        // 2.6 scale（1/sqrt(d_k)）折进 Q（Q *= scale）：注意力表达式不含
        // scale 常量 → 结构与 d_k 无关（不同 d_k 共享融合 shader，注册表
        // key 稳定）。backward 的 grad_Q 相应补乘 scale。
        // 写法用 dsl::compute_into（零分配原地写）；dsl::compute 是分配版
        // （另分配一整块缓冲），此处不适用。
        // scale_ 用 rparam 承载 → 值不进 expr_spec_key（融合二期教训 1）。
        {
            auto qs = dsl::compute_into(engine, dsl::leaf(Q) * dsl::rparam(scale_), Q);
            NN_TRY_CHECK(qs);
        }

        // ── 注意力主体：单 fold 路径 ────────────────────────────────────
        const std::size_t BH = batch * num_heads_;
        const std::size_t BH_kv = batch * n_head_kv_;
        //   分数输入准备：位置偏置表（ALiBi 斜率；非 ALiBi = no-op）
        NN_TRY(pb, pos_->prepare_score_bias(engine, batch, seq));
        //   掩码输入张量准备（掩码策略自己构建 doc_col/doc_ids）
        NN_TRY(pm, mask_->prepare(engine, batch, seq));
        Tensor concat_out;  // (batch*H*d_k, seq)——fold 输出 O_t 经转置/重排得到
        // V 需 (BH*seq, d_k) 布局：V_t 构建须在 fold 求值之前完成（fold 直接消费 V_t）
        NN_TRY(V_T_full, engine.transpose(V));
        NN_TRY(V_t, engine.rearrange_3d(*V_T_full, seq, BH_kv, d_k_, false));
        // ── 单 fold 表达式：S 不物化、online 单遍 ──────────────────────
        //   无 (BH·seq, seq) 中间张量流量；掩码在 fold body 内逐块生效，
        //   tri_skip 把被屏蔽块钳成空转（被跳过的恰是 -inf/0 恒等项 →
        //   与全量计算逐位一致，见 FoldSpec::tri_skip 注释）。
        //   inputs 顺序 = make_fold_attn_o 的 views 顺序：Q,K,V_t,[slope],[dc],[ids]
        //   即**先位置偏置输入、后掩码输入**（两条链正交，各自只追加自己的）。
        std::vector<Tensor> fold_in{Q, K, *V_t};
        pos_->append_score_bias_inputs(fold_in);
        mask_->append_fold_inputs(fold_in);
        const nn::ExprSpec fold_spec =
            nn::expr::make_fold_attn_o(seq, d_k_, BH, mask_->mask_kind(), pos_->has_score_bias(),
                                       static_cast<std::uint32_t>(kv_ratio_));
        NN_TRY(fv, nn::validate_expr_spec(fold_spec, fold_in.size()));
        // scale 已折进 Q（见上 2.6；运行时值不进 expr_spec_key）——fold 的 mm 段直接消费
        NN_TRY(O_t_r, engine.eval_expr(fold_spec, fold_in, BH * seq, d_k_, p_.compute));
        Tensor O_t = std::move(*O_t_r);
        // O_t: (BH*seq, d_k) → 按 batch 转置回 (BH*d_k, seq) 供后续 rearrange：
        //   transpose → (d_k, BH*seq) → rearrange_3d(d_k, BH, seq) → (BH*d_k, seq)
        NN_TRY(O_T_full, engine.transpose(O_t));
        NN_TRY(co, engine.rearrange_3d(*O_T_full, d_k_, BH, seq, false));
        concat_out = std::move(*co);
        if (!checkpoint_mode_)
        {
            Q_cache_ = std::move(Q);
            K_cache_ = std::move(K);
            V_cache_ = std::move(V);
            // m/l 不作缓存（backward 内 softmax 归一化，见 recompute_W_ 注释）
        }
        // 掩码恒在 fold body 内生效（mask_->mask_kind() 选掩码种类），绝不物化；
        // 位置偏置作为正交的第二维一并交给 fold 构造（pos_->has_score_bias()）

        // 8. rearrange back: (batch*H*d_k, seq) → (H*d_k, batch*seq)
        Tensor concat;
        if (batch > 1)
        {
            NN_TRY(cb, engine.rearrange_3d(concat_out, H_dk, batch, seq, true));
            concat = std::move(*cb);
        }
        else
        {
            concat = std::move(concat_out);
        }

        // 9. SubLN（子层内部归一化；关 = 直通，逐位不变）→ 输出投影
        Tensor attn_out = std::move(concat);
        if (attn_sub_norm_)
        {
            NN_TRY(sn, attn_sub_norm_->forward(attn_out));
            attn_out = std::move(*sn);
        }
        return w_o_->forward(attn_out);
    }

    [[nodiscard]] Result<Tensor> backward(const Tensor& grad_output) override
    {
        ComputeEngine& engine = engine_ref();
        // 推断 batch/seq（与 forward 一致）
        const std::size_t total_seq = grad_output.cols();
        const std::size_t seq = (seq_len_ > 0) ? seq_len_ : total_seq;
        const std::size_t batch = (seq_len_ > 0) ? (total_seq / seq_len_) : 1;
        const std::size_t H_dk = num_heads_ * d_k_;
        const std::size_t BH = batch * num_heads_;

        // 1. SubLN 反向（关 = 直通）→ 输出投影反向 → grad_concat: (H*d_k, batch*seq)
        const Tensor* p_grad_o = &grad_output;
        Tensor grad_prenorm;
        if (attn_sub_norm_)
        {
            NN_TRY(gsn, attn_sub_norm_->backward(grad_output));
            grad_prenorm = std::move(*gsn);
            p_grad_o = &grad_prenorm;
        }
        NN_TRY(gc, w_o_->backward(*p_grad_o));
        nn_dbg_scan("attn.gc", engine, *gc);

        // 2. rearrange grad_concat → (batch*H*d_k, seq)
        Tensor grad_concat_re;
        if (batch > 1)
        {
            NN_TRY(gcr, engine.rearrange_3d(*gc, H_dk, batch, seq, false));
            grad_concat_re = std::move(*gcr);
        }
        else
        {
            grad_concat_re = std::move(*gc);
        }

        // 3-7. 注意力反向：R/X 路径
        Tensor grad_Q_re, grad_K_re, grad_V_re;  // 均 (batch*H*d_k, seq)
        {
            // P = grad_A = batched_matmul(grad_concat^T, V, BH, true, false)
            // forward: O = V × A^T → grad_A = grad_O^T × V（后续 R/X 分解的 P 输入）
            // dsl::matmul(batch)（结构经 scan 的 CSA/MHA backward dry-run 登记）；
            // 输出形状：transA=true → rows=BH*A.cols()；transB=false → cols=B.cols()
            // GQA：V_cache_ 存的是 n_head_kv 个头 → B 侧按头分组比取行块
            const std::uint32_t kvr = static_cast<std::uint32_t>(kv_ratio_);
            auto grad_A = dsl::compute(
                engine, dsl::matmul_kv(grad_concat_re, V_cache_, true, false, BH, 1, kvr),
                BH * grad_concat_re.cols(), V_cache_.cols(), p_.compute);
            NN_TRY_CHECK(grad_A);
            nn_dbg_scan("attn.grad_A", engine, *grad_A);
            // G = grad_concat_re^T 按 batch 转置 → (BH*seq, d_k)，
            // 供 grad_V[j][k] = Σ_i W·G[i][k]（同 V 的布局转换）
            NN_TRY(G_T_full, engine.transpose(grad_concat_re));
            NN_TRY(G, engine.rearrange_3d(*G_T_full, seq, BH, d_k_, false));
            // ── IR 路径（R/X 表达式 + batched matmul）──
            //   从 Q/K 重算 W（W 与 m/l 均不缓存——recompute_W_ 内部
            //   softmax 单表达式归一化）；
            //   FLOPs ×1.5-2（QK^T 重算），训练可接受。
            NN_TRY(W_re, recompute_W_(engine, Q_cache_, K_cache_, BH, seq));
            nn_dbg_scan("attn.W_re", engine, *W_re);
            //   R  = row_sum(W·P)                     → (BH*seq, 1)
            //   X  = scale·W·(P − R)                  → (BH*seq, seq)（物化）
            //   grad_Q = K × X^T；grad_K = Q × X；grad_V = W^T × G
            auto R = dsl::compute_reduce(
                engine, dsl::row_reduce_sum(dsl::leaf(*W_re) * dsl::leaf(*grad_A)), BH * seq, seq);
            NN_TRY_CHECK(R);
            nn_dbg_scan("attn.R", engine, *R);
            auto X = dsl::compute(engine,
                                  dsl::leaf(*W_re) * (dsl::leaf(*grad_A) - dsl::row_broadcast(*R)),
                                  BH * seq, seq, p_.compute);
            NN_TRY_CHECK(X);
            nn_dbg_scan("attn.X", engine, *X);
            // grad_Q = K × X^T（K_b (d_k,seq)，X_b (seq,seq) 按 X^T 使用）
            // dsl::matmul(batch)（transA=F,transB=T → rows=K.rows(), cols=X.rows()/BH）
            // GQA：A 侧 K 只存 n_head_kv 个头 → 按头分组比取行块；输出仍是
            //   **全 H 头**（rows = BH·d_k），即"紧输入 → 满输出"的映射。
            auto gq = dsl::compute(engine, dsl::matmul_kv(K_cache_, *X, false, true, BH, kvr, 1),
                                   BH * d_k_, X->rows() / BH, p_.compute);
            NN_TRY_CHECK(gq);
            nn_dbg_scan("attn.gq(pre-scale)", engine, *gq);
            // grad_Q 补乘 scale（forward 把 scale 折进了 Q）：compute_into 原地
            // （同 forward 2.6 的写法；rparam 承载 scale 值不进 key）
            {
                auto gqs = dsl::compute_into(engine, dsl::leaf(*gq) * dsl::rparam(scale_), *gq);
                NN_TRY_CHECK(gqs);
            }
            // grad_K = Q × X（dsl::matmul(batch)：false,false → rows=Q.rows(), cols=X.cols()）
            auto gk = dsl::compute(engine, dsl::matmul(Q_cache_, *X, false, false, BH),
                                   Q_cache_.rows(), X->cols(), p_.compute);
            NN_TRY_CHECK(gk);
            nn_dbg_scan("attn.gk", engine, *gk);
            // grad_V = W^T × G（W_b (seq,seq) 按 W^T 使用，G_b (seq,d_k)）→ (BH*seq, d_k)
            // dsl::matmul(batch)：transA=T,transB=F → rows=BH*W.cols(), cols=G.cols()
            auto gv_t = dsl::compute(engine, dsl::matmul(*W_re, *G, true, false, BH),
                                     BH * W_re->cols(), G->cols(), p_.compute);
            NN_TRY_CHECK(gv_t);
            // grad_V 转置回 (BH*d_k, seq)（与 forward 的 V_t→V 逆变换一致）
            NN_TRY(gv_T, engine.transpose(*gv_t));
            NN_TRY(gv_re, engine.rearrange_3d(*gv_T, d_k_, BH, seq, false));
            nn_dbg_scan("attn.gv_re", engine, *gv_re);
            grad_Q_re = std::move(*gq);
            grad_K_re = std::move(*gk);
            grad_V_re = std::move(*gv_re);
        }

        // 7.5 位置编码 backward：对 Q/K 梯度施加反角旋转
        //     （RoPE 的旋转矩阵正交，逆 = 转置 = 反角：grad*cos − rot(grad)*sin；
        //      非 RoPE 策略 = 恒等，无标志位判断）
        {
            NN_TRY(gq2, pos_->apply_qk(engine, grad_Q_re, seq, /*backward=*/true));
            NN_TRY(gk2, pos_->apply_qk(engine, grad_K_re, seq, /*backward=*/true));
        }

        // 8. rearrange back: (batch*H*d_k, seq) → (H*d_k, batch*seq)
        Tensor grad_Q, grad_K, grad_V;
        if (batch > 1)
        {
            NN_TRY(gq, engine.rearrange_3d(grad_Q_re, H_dk, batch, seq, true));
            grad_Q = std::move(*gq);
            NN_TRY(gk, engine.rearrange_3d(grad_K_re, H_dk, batch, seq, true));
            grad_K = std::move(*gk);
            NN_TRY(gv, engine.rearrange_3d(grad_V_re, H_dk, batch, seq, true));
            grad_V = std::move(*gv);
        }
        else
        {
            grad_Q = std::move(grad_Q_re);
            grad_K = std::move(grad_K_re);
            grad_V = std::move(grad_V_re);
        }

        // 9. 投影层反向 + 累加输入梯度
        NN_TRY(giq, w_q_->backward(grad_Q));
        nn_dbg_scan("attn.giq", engine, *giq);
        // GQA：把 grad_K / grad_V 从 num_heads 个头折叠回 n_head_kv 个（与展开
        // 同一张表；重复行 = 多路累加，正是"多个 query 头共享一个 KV 头"的
        // 梯度语义）。MHA 时为恒等搬移。
        auto fold_kv = [&](Tensor&& grad_full) -> Result<Tensor>
        {
            if (!gqa_expand_idx_.valid()) return std::move(grad_full);
            Tensor collapsed = engine.create_tensor(n_head_kv_ * d_k_, grad_full.cols(),
                                                    grad_full.precision(), InitSpec::zero());
            if (!collapsed.valid()) NN_FAIL("AttentionBase: GQA 折叠缓冲分配失败");
            NN_TRY(sr, engine.scatter_add_rows(collapsed, gqa_expand_idx_, grad_full));
            return collapsed;
        };
        NN_TRY(gk_fold, fold_kv(std::move(grad_K)));
        NN_TRY(gik, w_k_->backward(*gk_fold));
        nn_dbg_scan("attn.gik", engine, *gik);
        NN_TRY(gv_fold, fold_kv(std::move(grad_V)));
        NN_TRY(giv, w_v_->backward(*gv_fold));
        nn_dbg_scan("attn.giv", engine, *giv);

        // grad_input = grad_Q + grad_K + grad_V：三路累加**原地**融合为单趟
        // （dsl::compute_into 目标传递，不额外分配）。结合顺序固定为
        // (giq + gik) + giv —— 求和顺序确定，结果可复现。
        auto acc =
            dsl::compute_into(engine, dsl::leaf(*giq) + dsl::leaf(*gik) + dsl::leaf(*giv), *giq);
        NN_TRY_CHECK(acc);
        return giq;
    }

    // ── 增量推理（KV cache）──────────────────────────────────────────
    // 处理单个新 token，复用历史 K/V 缓存，避免重复计算前文。
    //
    // KV cache 布局: (max_len, H*d_k)，row=position，col=head×dim
    //   - 投影得到 k_new/v_new: (H*d_k, 1)
    //   - transpose → (1, H*d_k) 后 insert_rows 到 cache 第 cur_len 行
    //   - slice_rows 取前 new_len 行参与 attention
    //
    // 因果掩码无需施加：新 token 天然只能看到自身及之前的位置（cache 中只有前文）。
    // ALiBi 等分数偏置由掩码策略转发给位置编码器（apply_bias_step）。
    //
    // 输入: x_new (d_model, 1) 单个新 token 的嵌入
    // 输出: (d_model, 1) attention 输出
    [[nodiscard]] Result<Tensor> forward_step(ComputeEngine& engine, const Tensor& x_new,
                                              Tensor& k_cache, Tensor& v_cache, std::size_t cur_len)
    {
        if (x_new.rows() != d_model_ || x_new.cols() != 1)
            NN_FAIL("AttentionBase forward_step: x_new must be (d_model, 1)");
        // 1. Q/K/V 投影 → (H*d_k, 1)
        NN_TRY(q_res, w_q_->forward(x_new));
        NN_TRY(k_proj, w_k_->forward(x_new));
        NN_TRY(v_proj, w_v_->forward(x_new));

        // GQA：展开到 num_heads（cache 布局恒 (max_len, num_heads*d_k)，不因 GQA 改变）
        Tensor k_new, v_new;
        if (gqa_expand_idx_.valid())
        {
            NN_TRY(ke, engine.gather_rows(*k_proj, gqa_expand_idx_));
            k_new = std::move(*ke);
            NN_TRY(ve, engine.gather_rows(*v_proj, gqa_expand_idx_));
            v_new = std::move(*ve);
        }
        else
        {
            k_new = std::move(*k_proj);
            v_new = std::move(*v_proj);
        }

        // 1.5 位置编码：对 Q/K 施加当前位置 (cur_len) 的旋转后写入 KV cache
        //     （cache 中的历史 K 已在各自 step 旋转过，相对位置自然成立；
        //      非 RoPE 策略 = 恒等）
        {
            NN_TRY(qr, pos_->apply_qk_step(engine, *q_res, cur_len, /*backward=*/false));
            NN_TRY(kr, pos_->apply_qk_step(engine, k_new, cur_len, /*backward=*/false));
        }

        // 2. transpose → (1, H*d_k)，匹配 cache 的行布局
        NN_TRY(k_new_T, engine.transpose(k_new));
        NN_TRY(v_new_T, engine.transpose(v_new));

        // 3. 追加到 KV cache（就地写入第 cur_len 行）
        NN_TRY(r1, engine.insert_rows(k_cache, cur_len, *k_new_T));
        NN_TRY(r2, engine.insert_rows(v_cache, cur_len, *v_new_T));

        // 4. 取有效区间 [0, new_len) 并 transpose 为 (H*d_k, new_len) 布局
        //    batched_matmul 要求 rows 能被 batch 整除:
        //    (new_len, H*d_k) 的 rows=new_len 不保证整除 num_heads
        //    transpose 后 (H*d_k, new_len) 的 rows=H*d_k=d_model 必然整除
        const std::size_t new_len = cur_len + 1;
        NN_TRY(k_valid, engine.slice_rows(k_cache, 0, new_len));
        NN_TRY(v_valid, engine.slice_rows(v_cache, 0, new_len));
        auto K_T = engine.transpose(*k_valid);   // (H*d_k, new_len)
        NN_TRY_CHECK(K_T);
        auto V_T = engine.transpose(*v_valid);   // (H*d_k, new_len)
        NN_TRY_CHECK(V_T);

        // 5. scores = batched_matmul(Q, K_T, H, transA=T, transB=F)
        //    Q: (H*d_k, 1) — 每头 (d_k, 1)，转置后 (1, d_k)，M=1
        //    K_T: (H*d_k, new_len) — 每头 (d_k, new_len)，transB=F，N=new_len
        //    每头: (1, d_k) × (d_k, new_len) = (1, new_len)
        //    堆叠: (H, new_len)
        //    scale (1/sqrt(d_k)) 经 rparam 尾链乘在 matmul 结果上（不进 expr_spec_key）
        auto scores = dsl::compute(
            engine, dsl::matmul(*q_res, *K_T, true, false, num_heads_) * dsl::rparam(scale_),
            num_heads_ * q_res->cols(), K_T->cols(), p_.compute);
        NN_TRY_CHECK(scores);

        // 6. 施加增量推理的位置偏置（ALiBi；非 ALiBi = 恒等）。
        //    因果无需施加：KV cache 里只有前文，新 token 天然看不到未来。
        NN_TRY(masked, pos_->apply_bias_step(engine, std::move(*scores), cur_len, p_));

        // 7. softmax（行级归一化，每头独立）
        NN_TRY(attn, softmax_.forward(*masked));

        // 8. attn_out = batched_matmul(V_T, attn, H, transA=F, transB=T)
        //    V_T: (H*d_k, new_len) — 每头 (d_k, new_len)，transA=F，M=d_k
        //    attn: (H, new_len) — 每头 (1, new_len)，转置后 (new_len, 1)，N=1
        //    每头: (d_k, new_len) × (new_len, 1) = (d_k, 1)
        //    堆叠: (H*d_k, 1)
        // dsl::matmul(batch)：纯 {0,1} 结构（attention backward 已登记同 key）
        auto attn_out = dsl::compute(engine, dsl::matmul(*V_T, *attn, false, true, num_heads_),
                                     V_T->rows(), attn->rows() / num_heads_, p_.compute);
        NN_TRY_CHECK(attn_out);

        // 9. SubLN（子层内部归一化；关 = 直通）→ 输出投影 → (d_model, 1)
        Tensor ao = std::move(*attn_out);
        if (attn_sub_norm_)
        {
            NN_TRY(sn, attn_sub_norm_->forward(ao));
            ao = std::move(*sn);
        }
        return w_o_->forward(ao);
    }

protected:
    // ── 从 Q/K 重算 S 与 W（backward 用）───────────────────────────────
    //   W 与 m/l 均不作缓存：softmax 单表达式在 kernel 内部归一化，m/l 不外溢。
    //   S 由两条**正交**的链依次得到（各一次虚调用，无变体判断链）：
    //     1) S = mask(Q·Kᵀ)              —— 掩码策略（因果 / 文档）
    //     2) S += bias(S)（原地）         —— 位置编码策略（ALiBi；其余 no-op）
    //     3) W = softmax(S)（归约快路径）
    // 返回 (BH*seq, seq) 的 softmax 归一化权重；attention FLOPs ×1.5–2
    // （QK^T 在 backward 重算），训练可接受。
    [[nodiscard]] Result<Tensor> recompute_W_(ComputeEngine& engine, const Tensor& Q,
                                              const Tensor& K, std::size_t BH,
                                              std::size_t seq) const
    {
        NN_TRY(sres, mask_->masked_scores(engine, Q, K, BH, seq, p_, kv_ratio_));
        Tensor S = std::move(*sres);
        // 位置偏置：原地叠加（零额外分配）；非 ALiBi 策略是 no-op
        NN_TRY_CHECK(pos_->apply_score_bias(engine, S, BH, seq));
        // W = softmax(S)：单表达式归约快路径——与 Softmax::forward
        // 同构：ReduceRef 直接参与算术按行广播；m/l 在 kernel 内部归一化，
        // 不作为输入/缓存存在。
        return dsl::compute(
            engine,
            dsl::exp(dsl::leaf(S) - dsl::row_reduce_max(S)) /
                dsl::row_reduce_sum(dsl::exp(dsl::leaf(S) - dsl::row_reduce_max(S))),
            BH * seq, seq, p_.compute);
    }
};

// ══════════════════════════════════════════════════════════════════════════
// MultiHeadAttention — 无掩码双向多头注意力
//
// 掩码语义 = PlainScoreMask（基类默认工厂即可，无需再塞标志位）；
// 位置编码默认恒等（TransformerEncoderLayer 的位置信息在嵌入侧注入）。
// ══════════════════════════════════════════════════════════════════════════
class MultiHeadAttention final : public AttentionBase
{
public:
    [[nodiscard]] const char* layer_name() const noexcept override { return "MultiHeadAttention"; }

    MultiHeadAttention(std::size_t d_model, std::size_t num_heads, std::size_t seq_len = 0,
                       WeightQuant weight_quant = WeightQuant::None)
        : AttentionBase(d_model, num_heads, seq_len, false, NormType::LayerNorm, 0, weight_quant)
    {
    }
};

// ══════════════════════════════════════════════════════════════════════════
// CausalSelfAttention — 因果自注意力
//
// 两个**互相独立**的策略对象，各有自己的配置期工厂：
//   · 掩码（本类自己）：Plain→Causal 由本类选定，文档掩码按运行期数据开关
//       · 无文档        → CausalScoreMask
//       · 文档块对角    → CausalDocScoreMask
//   · 位置编码（由本层持有，见 compute_position_encoding.hpp）：
//       · RoPE   → pos_->apply_qk() 旋转 Q/K
//       · ALiBi  → pos_->apply_score_bias() 给分数加线性偏置
//  掩码工厂**不查询**位置编码（旧版 `pos_->has_score_bias()` 分支已删除）：
//  掩码只管"键能不能被看到"，位置偏置只管"位置带来的偏移"，两者正交。
//  forward/backward 里没有 use_alibi_/use_doc_ids_ 之类的判断。
//
// 文档感知（set_doc_ids）：每 step 的文档 id 是**运行期数据**，其"有/无"在
//   set_doc_ids 这一**配置调用**里裁定（模式不变时零开销），而不是每题一次
//   forward 再判一遍。空 span = 关闭文档掩码（退化为纯因果）。
//
// 算法差异（相对于 AttentionBase）：无——全部差异由两个策略对象承载。
//   seq_len=0 表示单样本模式（cols 即 seq）。
//
// 注意：max_len 参数保留仅为向后兼容签名，当前实现不使用。
// ══════════════════════════════════════════════════════════════════════════
class CausalSelfAttention final : public AttentionBase
{
public:
    [[nodiscard]] const char* layer_name() const noexcept override { return "CausalSelfAttention"; }

private:
    bool doc_enabled_ = false;

    [[nodiscard]] std::unique_ptr<AttnScoreMask> make_score_mask_() const override
    {
        // 配置期工厂：这是**唯一**决定掩码种类的地方（只依赖文档掩码的开关，
        // 与位置编码无关）。forward/backward 里没有任何变体判断。
        if (doc_enabled_) return std::make_unique<CausalDocScoreMask>(num_heads_);
        return std::make_unique<CausalScoreMask>();
    }

public:
    CausalSelfAttention(std::size_t d_model, std::size_t num_heads, std::size_t /*max_len*/ = 1024,
                        std::size_t seq_len = 0, PosEncodingType pos_enc = PosEncodingType::Learned,
                        bool subln = false, NormType subln_norm_type = NormType::LayerNorm,
                        std::size_t n_head_kv = 0, WeightQuant weight_quant = WeightQuant::None,
                        bool inference_only = false)
        : AttentionBase(d_model, num_heads, seq_len, subln, subln_norm_type, n_head_kv,
                        weight_quant, inference_only)
    {
        // ① 位置编码：注意力侧**由本层自持**（RoPE 的 cos/sin 表随层构建；
        //    Learned/Sinusoidal 在注意力侧是恒等 → 交回模型侧施加）。
        install_position_encoder(make_attention_position_encoder(pos_enc, d_k_, num_heads_));
        // ② 掩码：本类的因果语义（与位置编码正交，故独立安装）
        install_score_mask_();
    }

    // 文档感知：ids 非空 = 开启块对角文档掩码。空 span = 关闭（纯因果）。
    // 配置期调用（每 step 至多一次）：模式变化时才换装掩码策略。
    void set_doc_ids(std::span<const std::size_t> ids) override
    {
        const bool want = !ids.empty();
        if (want != doc_enabled_)
        {
            doc_enabled_ = want;
            install_score_mask_();   // 配置期换装：掩码策略随模式切换
        }
        score_mask().set_doc_ids(ids);
    }
};


// ══════════════════════════════════════════════════════════════════════════
//  CrossAttention — 交叉注意力（issue #33）：Q 来自 query 序列，K/V 来自
//  memory（encoder 输出 / teacher 表征 / 检索上下文）序列。
//
//  下游影响（立项动机）：encoder-decoder、蒸馏、检索增强、思考模型此前只能
//  在自己的复合层里把 MHA 的参数/mask/布局协议重新拼一遍——而 QK^T、softmax
//  缩放、布局重排这些是"库已验证、不该在下游重写"的部分。本层复用
//  AttentionBase 的全部投影/折叠/反向机器，只把"输入来源"分裂为二。
//
//  与自注意力的差异（仅两点）：
//    1. **双输入**：w_q_ 吃 query 张量，w_k_/w_v_ 吃 memory 张量
//       （Layer 协议是单进单出 → 双输入经 `forward_pair` / `backward_pair`
//        显式入口；单输入 `forward/backward` fail-fast 并指向它们）；
//    2. **双序列长**：query 每样本 seq_q 位置、memory 每样本 seq_kv 位置，
//       可以不等（输出行数 = BH·seq_q，fold 收缩轴 = seq_kv）。
//
//  掩码语义：**恒 Plain（双向）** —— cross-attention 的标准语义是 query
//  可见全部 memory（可及性由上游 padding/masking 在数据侧处理）；因果/文档
//  掩码是"同一序列内"的概念，不适用于跨序列注意力。位置编码默认恒等
//  （RoPE/ALiBi 是同一序列内的相对位置概念；跨序列位置对齐归数据侧）。
//
//  backward_pair 返回两路梯度：grad_query（喂给 query 分支的反向）与
//  grad_memory（喂给 memory 分支的反向）——两者形状分别镜像 query/memory
//  输入。伴随正确性（dL/dK、dL/dV 累加回 memory 路径）与自反向同一套
//  R/X 机器，仅形状参数不同。
//
//  AOT 注册表：fold（Plain/no-bias）与 backward 表达式结构与
//  MultiHeadAttention 完全同 key（k/seq 是形状参数不进 key）——scan_exprs
//  的 CrossAttention dry-run（seq_q ≠ seq_kv 矩形形状）另行登记确保覆盖。
// ══════════════════════════════════════════════════════════════════════════

// backward_pair 的双路梯度（query 与 memory 各一份）
struct CrossAttentionGrads
{
    Tensor grad_query;    // (d_model, batch*seq_q)
    Tensor grad_memory;   // (d_model, batch*seq_kv)
};

class CrossAttention final : public AttentionBase
{
private:
    std::size_t seq_kv_len_;   // memory 每样本序列长（0 = 单样本，cols 即 seq）

public:
    [[nodiscard]] const char* layer_name() const noexcept override { return "CrossAttention"; }

    // seq_len   = query 每样本序列长（0 = 单样本，cols 即 seq）
    // seq_kv_len = memory 每样本序列长（0 = 单样本；一般 ≠ seq_len）
    CrossAttention(std::size_t d_model, std::size_t num_heads, std::size_t seq_len = 0,
                   std::size_t seq_kv_len = 0, std::size_t n_head_kv = 0,
                   WeightQuant weight_quant = WeightQuant::None)
        : AttentionBase(d_model, num_heads, seq_len, false, NormType::LayerNorm, n_head_kv,
                        weight_quant),
          seq_kv_len_(seq_kv_len)
    {
    }
    // 注意：掩码基类默认 PlainScoreMask、位置编码默认恒等 —— 正是本层语义
    // （见类注释），无需 install。

    // ── 单输入协议：cross-attention 无意义 → fail-fast 指路 ────────────
    [[nodiscard]] Result<Tensor> forward(const Tensor&) override
    {
        NN_FAIL("CrossAttention 是双输入层：请用 forward_pair(query, memory)"
                "（Layer 单进单出协议不适用）");
    }
    [[nodiscard]] Result<Tensor> backward(const Tensor&) override
    {
        NN_FAIL("CrossAttention 是双输入层：请用 backward_pair(grad_output)"
                "（返回 grad_query 与 grad_memory 两路梯度）");
    }

    // ── forward_pair：query/memory 双输入 ──────────────────────────────
    // query  (d_model, batch*seq_q)   —— 输出侧序列（decoder 位置）
    // memory (d_model, batch*seq_kv)  —— 被注意序列（encoder 输出等）
    // 输出 (d_model, batch*seq_q)（列布局与自注意力一致）。
    [[nodiscard]] Result<Tensor> forward_pair(const Tensor& query, const Tensor& memory)
    {
        ComputeEngine& engine = engine_ref();
        if (query.rows() != d_model_ || memory.rows() != d_model_)
            NN_FAIL("CrossAttention forward_pair: 输入形状不匹配（rows != d_model）");
        // batch 一致性：两侧按各自 seq 长推 batch，必须相等
        const std::size_t seq_q = (seq_len_ > 0) ? seq_len_ : query.cols();
        const std::size_t seq_kv = (seq_kv_len_ > 0) ? seq_kv_len_ : memory.cols();
        if (query.cols() % seq_q != 0 || memory.cols() % seq_kv != 0)
            NN_FAIL("CrossAttention forward_pair: cols 不能被各自的 seq 长整除");
        const std::size_t batch_q = query.cols() / seq_q;
        const std::size_t batch_kv = memory.cols() / seq_kv;
        if (batch_q != batch_kv)
            NN_FAIL("CrossAttention forward_pair: query 与 memory 的 batch 不一致（" +
                    std::to_string(batch_q) + " vs " + std::to_string(batch_kv) + "）");

        // 1. 投影：Q 吃 query，K/V 吃 memory
        NN_TRY(q_res, w_q_->forward(query));
        NN_TRY(k_proj, w_k_->forward(memory));
        NN_TRY(v_proj, w_v_->forward(memory));

        // 2. rearrange：Q → (batch*H*d_k, seq_q)；K/V → (batch*KV_dk, seq_kv)
        const std::size_t H_dk = num_heads_ * d_k_;
        const std::size_t KV_dk = n_head_kv_ * d_k_;
        Tensor Q, K, V;
        if (batch_q > 1)
        {
            NN_TRY(qr, engine.rearrange_3d(*q_res, H_dk, batch_q, seq_q, false));
            Q = std::move(*qr);
            NN_TRY(kr, engine.rearrange_3d(*k_proj, KV_dk, batch_kv, seq_kv, false));
            K = std::move(*kr);
            NN_TRY(vr, engine.rearrange_3d(*v_proj, KV_dk, batch_kv, seq_kv, false));
            V = std::move(*vr);
        }
        else
        {
            Q = std::move(*q_res);
            K = std::move(*k_proj);
            V = std::move(*v_proj);
        }

        // 3. scale 折进 Q（与自注意力 2.6 同口径；rparam 承载不进 key）
        {
            auto qs = dsl::compute_into(engine, dsl::leaf(Q) * dsl::rparam(scale_), Q);
            NN_TRY_CHECK(qs);
        }

        // 4. 单 fold：收缩轴 = seq_kv（键长），输出行 = BH·seq_q（query 长）
        const std::size_t BH = batch_q * num_heads_;
        const std::size_t BH_kv = batch_kv * n_head_kv_;
        NN_TRY(pm, mask_->prepare(engine, batch_q, seq_kv));
        NN_TRY(V_T_full, engine.transpose(V));
        NN_TRY(V_t, engine.rearrange_3d(*V_T_full, seq_kv, BH_kv, d_k_, false));
        std::vector<Tensor> fold_in{Q, K, *V_t};
        mask_->append_fold_inputs(fold_in);
        // Plain/no-bias 构造：f.k = seq_kv；eval 输出行 = BH·seq_q（矩形）
        const nn::ExprSpec fold_spec =
            nn::expr::make_fold_attn_o(seq_kv, d_k_, BH, mask_->mask_kind(), /*score_bias=*/false,
                                       static_cast<std::uint32_t>(kv_ratio_));
        NN_TRY(fv, nn::validate_expr_spec(fold_spec, fold_in.size()));
        NN_TRY(O_t_r, engine.eval_expr(fold_spec, fold_in, BH * seq_q, d_k_, p_.compute));
        // O_t (BH*seq_q, dk) → (BH*dk, seq_q) → (H*dk, batch*seq_q)
        NN_TRY(O_T_full, engine.transpose(*O_t_r));
        NN_TRY(co, engine.rearrange_3d(*O_T_full, d_k_, BH, seq_q, false));
        Tensor concat_out = std::move(*co);
        if (!checkpoint_mode_)
        {
            Q_cache_ = std::move(Q);
            K_cache_ = std::move(K);
            V_cache_ = std::move(V);
        }
        Tensor concat;
        if (batch_q > 1)
        {
            NN_TRY(cb, engine.rearrange_3d(concat_out, H_dk, batch_q, seq_q, true));
            concat = std::move(*cb);
        }
        else
        {
            concat = std::move(concat_out);
        }
        return w_o_->forward(concat);
    }

    // ── backward_pair：双路梯度 ────────────────────────────────────────
    // grad_output (d_model, batch*seq_q) → {grad_query, grad_memory}
    [[nodiscard]] Result<CrossAttentionGrads> backward_pair(const Tensor& grad_output)
    {
        ComputeEngine& engine = engine_ref();
        if (!Q_cache_.valid() || !K_cache_.valid() || !V_cache_.valid())
            NN_FAIL("CrossAttention backward_pair: 无缓存（backward_pair 前必须"
                    "先 forward_pair；checkpoint 模式下缓存不保留）");
        // batch/seq 从缓存推（Q: (BH*dk, seq_q)，K: (BH_kv*dk, seq_kv)）
        const std::size_t seq_q = Q_cache_.cols();
        const std::size_t seq_kv = K_cache_.cols();
        if (grad_output.cols() % seq_q != 0)
            NN_FAIL("CrossAttention backward_pair: grad_output.cols() 不能被 seq_q 整除");
        const std::size_t batch = grad_output.cols() / seq_q;
        const std::size_t H_dk = num_heads_ * d_k_;
        const std::size_t BH = batch * num_heads_;

        // 1. 输出投影反向 → grad_concat (H*dk, batch*seq_q)
        NN_TRY(gc, w_o_->backward(grad_output));
        nn_dbg_scan("xattn.gc", engine, *gc);
        Tensor grad_concat_re;
        if (batch > 1)
        {
            NN_TRY(gcr, engine.rearrange_3d(*gc, H_dk, batch, seq_q, false));
            grad_concat_re = std::move(*gcr);
        }
        else
        {
            grad_concat_re = std::move(*gc);
        }

        // 2-7. 注意力反向（R/X 路径；形状 = 矩形 BH·seq_q × seq_kv）
        Tensor grad_Q_re, grad_K_re, grad_V_re;
        {
            const std::uint32_t kvr = static_cast<std::uint32_t>(kv_ratio_);
            // P = grad_A = grad_O^T × V → (BH*seq_q, seq_kv)
            auto grad_A = dsl::compute(
                engine, dsl::matmul_kv(grad_concat_re, V_cache_, true, false, BH, 1, kvr),
                BH * grad_concat_re.cols(), V_cache_.cols(), p_.compute);
            NN_TRY_CHECK(grad_A);
            nn_dbg_scan("xattn.grad_A", engine, *grad_A);
            // G = grad_concat^T → (BH*seq_q, d_k)
            NN_TRY(G_T_full, engine.transpose(grad_concat_re));
            NN_TRY(G, engine.rearrange_3d(*G_T_full, seq_q, BH, d_k_, false));
            // W = softmax(mask(Q·Kᵀ))（矩形；Plain 掩码 = 无屏蔽）
            NN_TRY(W_re, recompute_W_pair_(engine, Q_cache_, K_cache_, BH, seq_q, seq_kv));
            nn_dbg_scan("xattn.W_re", engine, *W_re);
            // R = row_sum(W·P) → (BH*seq_q, 1)
            auto R = dsl::compute_reduce(engine,
                                         dsl::row_reduce_sum(dsl::leaf(*W_re) * dsl::leaf(*grad_A)),
                                         BH * seq_q, seq_kv);
            NN_TRY_CHECK(R);
            // X = W·(P − R) → (BH*seq_q, seq_kv)
            auto X = dsl::compute(engine,
                                  dsl::leaf(*W_re) * (dsl::leaf(*grad_A) - dsl::row_broadcast(*R)),
                                  BH * seq_q, seq_kv, p_.compute);
            NN_TRY_CHECK(X);
            nn_dbg_scan("xattn.X", engine, *X);
            // grad_Q = K × X^T → (BH*d_k, seq_q)（scale 补乘同自反向）
            auto gq = dsl::compute(engine, dsl::matmul_kv(K_cache_, *X, false, true, BH, kvr, 1),
                                   BH * d_k_, X->rows() / BH, p_.compute);
            NN_TRY_CHECK(gq);
            {
                auto gqs = dsl::compute_into(engine, dsl::leaf(*gq) * dsl::rparam(scale_), *gq);
                NN_TRY_CHECK(gqs);
            }
            // grad_K = Q × X → (BH*d_k, seq_kv)
            auto gk = dsl::compute(engine, dsl::matmul(Q_cache_, *X, false, false, BH),
                                   Q_cache_.rows(), X->cols(), p_.compute);
            NN_TRY_CHECK(gk);
            // grad_V = W^T × G → (BH*seq_kv, d_k) → 转置回 (BH*d_k, seq_kv)
            auto gv_t = dsl::compute(engine, dsl::matmul(*W_re, *G, true, false, BH),
                                     BH * W_re->cols(), G->cols(), p_.compute);
            NN_TRY_CHECK(gv_t);
            NN_TRY(gv_T, engine.transpose(*gv_t));
            NN_TRY(gv_re, engine.rearrange_3d(*gv_T, d_k_, BH, seq_kv, false));
            grad_Q_re = std::move(*gq);
            grad_K_re = std::move(*gk);
            grad_V_re = std::move(*gv_re);
        }

        // 8. rearrange 回列布局（各自 seq 长）
        Tensor grad_Q, grad_K, grad_V;
        if (batch > 1)
        {
            NN_TRY(gq8, engine.rearrange_3d(grad_Q_re, H_dk, batch, seq_q, true));
            grad_Q = std::move(*gq8);
            NN_TRY(gk8, engine.rearrange_3d(grad_K_re, H_dk, batch, seq_kv, true));
            grad_K = std::move(*gk8);
            NN_TRY(gv8, engine.rearrange_3d(grad_V_re, H_dk, batch, seq_kv, true));
            grad_V = std::move(*gv8);
        }
        else
        {
            grad_Q = std::move(grad_Q_re);
            grad_K = std::move(grad_K_re);
            grad_V = std::move(grad_V_re);
        }

        // 9. 投影反向：grad_query = w_q_ 反向；grad_memory = (w_k_ + w_v_) 反向和
        NN_TRY(giq, w_q_->backward(grad_Q));
        auto fold_kv = [&](Tensor&& grad_full) -> Result<Tensor>
        {
            if (!gqa_expand_idx_.valid()) return std::move(grad_full);
            Tensor collapsed = engine.create_tensor(n_head_kv_ * d_k_, grad_full.cols(),
                                                    grad_full.precision(), InitSpec::zero());
            if (!collapsed.valid()) NN_FAIL("CrossAttention: GQA 折叠缓冲分配失败");
            NN_TRY(sr, engine.scatter_add_rows(collapsed, gqa_expand_idx_, grad_full));
            return collapsed;
        };
        NN_TRY(gk_fold, fold_kv(std::move(grad_K)));
        NN_TRY(gik, w_k_->backward(*gk_fold));
        NN_TRY(gv_fold, fold_kv(std::move(grad_V)));
        NN_TRY(giv, w_v_->backward(*gv_fold));

        CrossAttentionGrads out;
        out.grad_query = std::move(*giq);
        // memory 侧两路累加（结合顺序固定 = 可复现）
        auto acc = dsl::compute(engine, dsl::leaf(*gik) + dsl::leaf(*giv), gik->rows(), gik->cols(),
                                p_.compute);
        NN_TRY_CHECK(acc);
        out.grad_memory = std::move(*acc);
        return out;
    }

protected:
    // W 重算（矩形版；与自反向 recompute_W_ 同构，仅形状参数分离为
    // seq_q/seq_kv）。掩码恒 Plain → 屏蔽链为空；位置编码恒等 → 无偏置叠加。
    [[nodiscard]] Result<Tensor> recompute_W_pair_(ComputeEngine& engine, const Tensor& Q,
                                                   const Tensor& K, std::size_t BH,
                                                   std::size_t seq_q, std::size_t seq_kv) const
    {
        NN_TRY(sres, mask_->masked_scores(engine, Q, K, BH, seq_kv, p_, kv_ratio_));
        return dsl::compute(
            engine,
            dsl::exp(dsl::leaf(*sres) - dsl::row_reduce_max(*sres)) /
                dsl::row_reduce_sum(dsl::exp(dsl::leaf(*sres) - dsl::row_reduce_max(*sres))),
            BH * seq_q, seq_kv, p_.compute);
    }
};

} // namespace nn
