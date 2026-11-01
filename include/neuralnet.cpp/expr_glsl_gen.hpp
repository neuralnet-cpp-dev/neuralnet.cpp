#pragma once

// ═══════════════════════════════════════════════════════════════════════════
//  expr_glsl_gen.hpp — AOT 算子融合：ExprSpec → GLSL 计算 shader 源码
//
//  在构建期由 tools/gen_fused 调用：把 scan_exprs 收集的内联表达式结构
//  （ExprSpec，派生物）展开为单个融合 .comp 文件。
//    - 指令序列展开为直线浮点代码（无解释器开销，GPU 无分支）
//    - 视图（RotateHalf/RowMod）的索引映射内联（不物化中间张量）
//    - 常量以 push constant 传入（运行时可变）
//  产物走现有管线：glslc → .spv → cmake/embed_spirv.cmake → C++ 数组
//
//  本头仅供构建期生成器使用，运行时无需包含。
// ═══════════════════════════════════════════════════════════════════════════

#include <bit>
#include <cmath>
#include <cstdint>
#include <functional>
#include <sstream>
#include <string>

#include "expr_spec.hpp"
#include "expr_op_table.hpp" // 算子元数据单一真源（GLSL 发射形态/符号，RV-07）
#include "expr_emitter.hpp"   // IR-D：emitter 抽象（GlslEmitter 实现）

namespace nn
{

// ── f32 → f16 存储的 RNE（round-half-to-even）预舍入 ─────────────────────
// float16_t(x) 编译为 SPIR-V OpFConvert，其舍入模式**未被 Vulkan/SPIR-V 规范
// 钉死**：实测 NVIDIA 驱动按“向零截断”。对 p *= (1-lr·wd) 这类结果紧贴原 f16
// 网格点的写回，截断恰好每步掉 1 个网格步（与 lr 无关）→ 数万步后权重下溢为
// 0、loss 回到 ln(V)（见 research/f16_weight_decay/REPORT.md）。
// ⚠ 不能用 packHalf2x16 代替：同驱动上实测它**同样截断**（Khronos
// Vulkan-Docs #1825「PackHalf2x16 rounding behavior is ambiguously defined」），
// 与宿主 nn::f16（RNE）对拍 4/8 不一致。
// 因此改用整数位运算在 f32 域做精确 RNE：返回值本身落在 f16 网格上（f16 ⊂ f32
// 可精确表示），随后的 float16_t() 收窄无论取哪种舍入模式都不再产生偏差。
[[nodiscard]] inline std::string glsl_f16_store(const std::string& v)
{ return "float16_t(nn_f16_rne(" + v + "))"; }

// 上面 glsl_f16_store 依赖的 GLSL 辅助函数源码；凡会写 f16 的生成 shader
// 前导必须发射一次（声明必须先于使用）。用整数位运算实现精确 RNE，不依赖
// 驱动 OpFConvert / packHalf2x16 的舍入模式（两者实测都向零截断）。
[[nodiscard]] inline const char* glsl_f16_rne_source()
{
    return "// f32 → f16 网格的 RNE 预舍入：返回值本身落在 f16 网格上（f16 ⊂ f32\n"
           "// 可精确表示），随后的 float16_t() 收窄不再产生任何舍入偏差。\n"
           "float nn_f16_rne(float x)\n"
           "{\n"
           "    uint u = floatBitsToUint(x);\n"
           "    const uint a = u & 0x7fffffffu;\n"
           "    if (a >= 0x7f800000u || a < 0x38800000u)   // Inf/NaN，或 |x| < 2^-14\n"
           "        return roundEven(x * 16777216.0) / 16777216.0;\n"
           "    u += 0x0fffu + ((u >> 13u) & 1u);          // 半个 ULP + tie-to-even\n"
           "    u &= 0xffffe000u;                          // 截到 f16 的 10 位尾数\n"
           "    return uintBitsToFloat(u);\n"
           "}\n\n";
}

// ── 算子 → GLSL 右值片段（形态/符号来自 expr_op_table.hpp，RV-07）──────────
//
// 一条逐元素指令的字符串骨架由"发射形态"（ExprEmitKind）唯一决定，符号/函数名
// 由元数据表提供——新增算子只需在表里选一个已有形态并填符号，不必改本文件。
//   vec4    ：向量形态（比较用向量内建、Select 用 mix/notEqual）
//   native16：f16 算术变体的字面量类型（比较/Select 的 1/0 须显式 f16）
//   wrap    ：内联上下文需额外一层括号（与语句形态逐字一致）
// b/c 以惰性回调传入：一元 / 函数算子不触碰不使用的操作数（保持原求值副作用序）。
template <class GetB, class GetC>
[[nodiscard]] inline std::string glsl_alu_expr(const detail::ExprOpInfo& info, const std::string& a,
                                               GetB&& b, GetC&& c, bool vec4, bool native16,
                                               bool wrap)
{
    switch (info.emit)
    {
    case detail::ExprEmitKind::Infix:
    {
        const std::string e = a + " " + info.sym + " " + b();
        return wrap ? ("(" + e + ")") : e;
    }
    case detail::ExprEmitKind::Func2:
        return std::string(info.sym) + "(" + a + ", " + b() + ")";
    case detail::ExprEmitKind::Compare:
        if (vec4) return std::string("vec4(") + info.sym_vec + "(" + a + ", " + b() + "))";
        {
            const std::string e = "(" + a + " " + info.sym + " " + b() + ") ? " +
                                  (native16 ? "float16_t(1.0)" : "1.0") + " : " +
                                  (native16 ? "float16_t(0.0)" : "0.0");
            return wrap ? ("(" + e + ")") : e;
        }
    case detail::ExprEmitKind::Neg:
    {
        const std::string e = "-(" + a + ")";
        return wrap ? ("(" + e + ")") : e;
    }
    case detail::ExprEmitKind::Func1:
        return std::string(info.sym) + "(" + a + ")";
    case detail::ExprEmitKind::Select:
        if (vec4)
            // mix(x,y,t) = x(1-t) + y·t：t=(a≠0) 时须取 b → b 在 y 位
            return "mix(" + c() + ", " + b() + ", notEqual(" + a + ", vec4(0.0)))";
        {
            const std::string e = "(" + a + " != " + (native16 ? "float16_t(0.0)" : "0.0") +
                                  ") ? " + b() + " : " + c();
            return wrap ? ("(" + e + ")") : e;
        }
    case detail::ExprEmitKind::None:
        break;   // 归约指令：不经逐元素发射
    }
    return {};
}

// ── 视图 → 读取第 i 个元素的索引/表达式 ──────────────────────────────────
// 布局约定：row = i/cols, col = i%cols（与 C++ 端 eval_expr 一致）
// vp_slot：该视图的运行时参数槽位（仅 RowMod/RotateHalf 有效；槽位按视图
//   序数累计——排在本视图之前的 runtime-param 视图槽数之和）。RowMod 周期 /
//   RotateHalf 块大小从 push constant vpN 读取——同结构不同形状（不同 d_k）
//   共享一个融合 shader。
// f16_native：原生 f16 算术变体（native16）——f16 缓冲读取不加 float()
//   包装，整个视图表达式保持 float16_t 类型（GL_EXT_shader_explicit_
//   arithmetic_types_float16 允许 f16 算术/取负）。默认 false = f32 算术
//   变体（f16 存储 + 读处显式转 f32）。
// 单次构建：给定缓冲区名与该视图是否 f16 视图，产出读取表达式字符串。
// **非分派路径的输出与历史逐字一致**（RotateHalf 内部转 f32、其余分支裸读，
// 外层转换仍由调用方 float(...) 负责）——这是 V0/V2 文本 byte-identical 的前提。
inline std::string glsl_view_read_(const ExprView& v, std::uint32_t buf_id, const std::string& buf,
                                   bool f16_buf, const std::string& idx_var,
                                   const std::string& row_var, const std::string& col_var,
                                   std::uint32_t vp_slot, ExprPrecSig sig)
{
    const auto rw = [&](const std::string& idx) -> std::string
    { return f16_buf ? ("float(" + buf + "[" + idx + "])") : (buf + "[" + idx + "]"); };
    const bool disp = expr_prec_sig_is_dispatch(sig);
    switch (v.kind)
    {
    default:
    case static_cast<uint8_t>(ExprViewKind::Linear):
        return buf + "[" + idx_var + "]";
    case static_cast<uint8_t>(ExprViewKind::RotateHalf):
    {
        // block 为运行时视图参数（push constant vpN），形状无关融合
        const std::string blk = "(" + row_var + " / vp" + std::to_string(vp_slot) + ")";
        const std::string rl = "(" + row_var + " % vp" + std::to_string(vp_slot) + ")";
        const std::string half = "(vp" + std::to_string(vp_slot) + " / 2u)";
        // 列主序索引 = 源行 * cols + 列号（cols 为 push constant 列数）
        const std::string hi = "((" + blk + " * vp" + std::to_string(vp_slot) + " + " + rl + " + " +
                               half + ") * cols + " + col_var + ")";
        const std::string lo = "((" + blk + " * vp" + std::to_string(vp_slot) + " + " + rl + " - " +
                               half + ") * cols + " + col_var + ")";
        const std::string neg = v.negate_first_half ? "-" : "";
        return "((" + rl + " < " + half + ") ? " + neg + rw(hi) + " : " + rw(lo) + ")";
    }
    case static_cast<uint8_t>(ExprViewKind::RowMod):
        // 周期为运行时视图参数（push constant vpN），形状无关融合
        return buf + "[(" + row_var + " % vp" + std::to_string(vp_slot) + ") * cols + " + col_var +
               "]";
    case static_cast<uint8_t>(ExprViewKind::RowAccess):
        // 行偏移+取模：data[(offset + r % mod)*cols + c]。
        // vp_slot=mod（op），vp_slot+1=offset（param2），双 vp 槽（形状无关）。
        return buf + "[(" + "vp" + std::to_string(vp_slot + 1) + " + (" + row_var + " % vp" +
               std::to_string(vp_slot) + ")) * cols + " + col_var + "]";
    case static_cast<uint8_t>(ExprViewKind::Transpose):
        // 转置读：data[col*stride + row]（stride = 存储行距，运行期 vp 槽）。
        // 与 Linear 同为裸读（f16 外层转换由调用方负责）。
        return buf + "[" + col_var + " * vp" + std::to_string(vp_slot) + " + " + row_var + "]";
    case static_cast<uint8_t>(ExprViewKind::GroupedReduceSum):
    case static_cast<uint8_t>(ExprViewKind::GroupedReduceMax):
        // 分组归约：输出行 r → 输入组行 [r*R, (r+1)*R)，列不变。
        // R 是**运行期**视图参数（vp 槽，不进 key → 任意池化窗口共享一个
        // shader），故读取走 per-view 辅助函数 `gr_r<buf_id>(row, col)`
        // （内部为运行期循环；累加顺序与 CPU 模板路径 GroupedReduceRef::eval
        // 逐元素一致，铁律 8）。辅助函数由
        // `glsl_emit_grouped_reduce_helpers()` 在 shader 顶部发射。
        return "gr_r" + std::to_string(buf_id) + "(" + row_var + ", " + col_var + ")";
    case static_cast<uint8_t>(ExprViewKind::RowBroadcast):
        return buf + "[" + row_var + "]";   // 输入 (rows,1)：每行一个值
    case static_cast<uint8_t>(ExprViewKind::ColBroadcast):
        return buf + "[" + col_var + "]";   // 输入 (1,cols)：每列一个值
    case static_cast<uint8_t>(ExprViewKind::RowGather):
    {
        // 按标签行收集：data[uint(labels[col]) * cols + col]（labels 槽 = v.param）
        // f16 标签槽（少见）需先转 f32 再取整：uint(float16_t) 不合法。
        // 标签槽可能与被收集的槽**不是同一槽**，故判据用 v.param；运行期
        // 分派形态下标签槽自身也走分派位。
        const std::string lb = "b" + std::to_string(v.param);
        std::string lab;
        if (disp)
            lab = "((prec >> " + std::to_string(v.param) + "u & 1u) != 0u ? uint(float(" + lb +
                  "h[" + col_var + "])) : uint(" + lb + "[" + col_var + "]))";
        else if (expr_prec_sig_in_f16(sig, v.param))
            lab = "uint(float(" + lb + "[" + col_var + "]))";
        else lab = "uint(" + lb + "[" + col_var + "])";
        return buf + "[" + lab + " * cols + " + col_var + "]";
    }
    case static_cast<uint8_t>(ExprViewKind::BatchMod):
        // 按批次取模索引：data[batch % vpN]（需要 batch 变量；取模数
        // num_heads 为运行时视图参数 → 同结构不同头数共享一个融合 shader）
        return buf + "[batch % vp" + std::to_string(vp_slot) + "]";
    case static_cast<uint8_t>(ExprViewKind::BatchCol):
        // 按 (batch, col) 切片：data[batch*vpN + col]（需要 batch 变量；
        //    每批列数 seq 为运行时视图参数 → 同结构不同 seq 共享一个融合 shader）
        return buf + "[batch * vp" + std::to_string(vp_slot) + " + " + col_var + "]";
    }
}

inline void glsl_view_read(std::ostringstream& os, const ExprView& v, std::uint32_t buf_id,
                           const std::string& idx_var, const std::string& row_var,
                           const std::string& col_var, std::uint32_t vp_slot = 0,
                           ExprPrecSig sig = 0, bool f16_native = false)
{
    const std::string buf = "b" + std::to_string(buf_id);
    // 该输入的存储类型：f16 时**视图内部**的算术/索引读取必须显式转 f32
    // （GL_EXT_shader_16bit_storage 只允许存储，不允许 f16 算术：
    //  `-b0[i]` / `uint(b0[i])` 都会被 glslc 拒绝）。视图外层的整体转换由
    // 调用方（emit_scalar_chain / vec4 读取）负责。
    // f16_native 时扩展提供了 f16 算术 → 不转（保持 float16_t 类型链）。
    const bool f16_buf = expr_prec_sig_in_f16(sig, buf_id) && !f16_native;
    const ExprViewKind vkind = static_cast<ExprViewKind>(v.kind);
    if (!expr_prec_sig_is_dispatch(sig))
    {
        os << glsl_view_read_(v, buf_id, buf, f16_buf, idx_var, row_var, col_var, vp_slot, sig);
        return;
    }
    if (vkind == ExprViewKind::GroupedReduceSum || vkind == ExprViewKind::GroupedReduceMax)
    {
        // 分组归约在分派模式下**自带精度选择**：读取点是 `gr_r<i>(row,col)`，
        // 该辅助函数内部已按 PC `prec` 选视图并返回 float。再套外层三元只会
        // 产生 `prec ? … : …` 里嵌同样 `prec ? … : …` 的重复表达式（语义相同、
        // 文本翻倍）。RowGather **不能**走这条快路：它自带分派的只有**标签槽**，
        // 取值仍需外层三元在 `b<i>` / `b<i>h` 之间选择。
        os << glsl_view_read_(v, buf_id, buf, false, idx_var, row_var, col_var, vp_slot, sig);
        return;
    }
    // ── 运行期精度分派（V1）：同一索引同时作两种视图解引用，uniform 选择 ──
    // f16 分支取 float(...)（行内 rw 已转的表达式再套一层 float 是无害恒等）。
    const std::string f32e =
        glsl_view_read_(v, buf_id, buf, false, idx_var, row_var, col_var, vp_slot, sig);
    const std::string hbuf = buf + "h";
    const std::string f16e =
        glsl_view_read_(v, buf_id, hbuf, true, idx_var, row_var, col_var, vp_slot, sig);
    os << "((prec >> " << buf_id << "u & 1u) != 0u ? float(" << f16e << ") : " << f32e << ")";
}

// ── 视图的运行时参数（vp）槽位 ──────────────────────────────────────────
// 槽位 = 排在该视图之前的 runtime-param 视图槽数之和（RowAccess 占 2 槽）。
// **唯一实现**：六个生成路径此前各写一遍同一段循环，任一处漂移就会读写错位的
// push constant 字（后端 `pc_base` 的注释记录过这类"静默错值"事故）。
[[nodiscard]] inline std::uint32_t glsl_vp_slot(const ExprSpec& spec, std::size_t view_idx)
{
    std::uint32_t vp = 0;
    for (std::size_t j = 0; j < view_idx; ++j)
    {
        const auto k = static_cast<ExprViewKind>(spec.views[j].kind);
        if (expr_view_has_runtime_param(k)) vp += expr_view_runtime_param_slots(k);
    }
    return vp;
}

// ── GQA：操作数"行块号"表达式（docs/internal/22 §3.2 P2）──────────────
// 该操作数的视图是 HeadGroup 时，行块号 = base / 头分组比（比走运行期 vp 槽，
//   param 不进 key → 任意 n_rep 共用一份 shader）；
// 其余视图原样返回 base → 生成代码与既有逐字节相同（MHA 路径零变化）。
[[nodiscard]] inline std::string gqa_blk_expr(const ExprSpec& spec, std::size_t view_idx,
                                              const std::string& base = "batch")
{
    if (view_idx >= spec.views.size()) return base;
    if (static_cast<ExprViewKind>(spec.views[view_idx].kind) != ExprViewKind::HeadGroup)
        return base;
    return "(" + base + " / vp" + std::to_string(glsl_vp_slot(spec, view_idx)) + ")";
}

// ── 分组归约视图的读取辅助函数发射（R 运行期 → 循环替代编译期展开链）──────
// R 是运行期视图参数（vp 槽，不进 key）→ 任意池化窗口共享一个 shader。
// 循环内的累加顺序与 CPU 模板路径 GroupedReduceRef::eval 逐元素一致（铁律 8）：
// sum = 左结合升序加；max = 嵌套 max(acc, elem)。读取点见 glsl_view_read 的
// GroupedReduceSum/Max 分支（`gr_r<i>(row, col)`），故**两者必须成对发射**。
// 位置：shader 顶部（PC / 缓冲声明之后、main 之前）。
// **每个可能发射 `gr_r<i>` 的生成器都必须调用本函数**：glsl_view_read 对
// GroupedReduce 视图无条件发 `gr_r<i>(...)`，目前 elementwise / matmul /
// 归约三处调用它。无该视图时本函数不产出任何文本（调用零成本）。
inline void glsl_emit_grouped_reduce_helpers(std::ostringstream& os, const ExprSpec& spec,
                                             ExprPrecSig sig = 0, bool f16_native = false)
{
    const char* ty = f16_native ? "float16_t" : "float";
    for (std::size_t i = 0; i < spec.views.size(); ++i)
    {
        const auto k = static_cast<ExprViewKind>(spec.views[i].kind);
        if (k != ExprViewKind::GroupedReduceSum && k != ExprViewKind::GroupedReduceMax) continue;
        // vp 槽 = 按视图序累计（与 glsl_view_read 调用点同源，见 glsl_vp_slot）
        const std::uint32_t vp = glsl_vp_slot(spec, i);
        const bool is_max = (k == ExprViewKind::GroupedReduceMax);
        const bool disp = expr_prec_sig_is_dispatch(sig);
        const bool f16_buf = expr_prec_sig_in_f16(sig, i) && !f16_native;
        const std::string buf = "b" + std::to_string(i);
        const auto elem = [&](const std::string& tt) -> std::string
        {
            const std::string idx = "((row * R + " + tt + ") * cols + col)";
            if (disp)
                return "((prec >> " + std::to_string(i) + "u & 1u) != 0u ? float(" + buf + "h[" +
                       idx + "]) : " + buf + "[" + idx + "])";
            return f16_buf ? ("float(" + buf + "[" + idx + "])") : (buf + "[" + idx + "]");
        };
        os << "\n" << ty << " gr_r" << i << "(uint row, uint col)\n{\n";
        os << "    const uint R = vp" << vp << ";\n";
        os << "    " << ty << " acc = " << elem("0u") << ";\n";
        os << "    for (uint tt = 1u; tt < R; ++tt)\n";
        if (is_max) os << "        acc = max(acc, " << elem("tt") << ");\n";
        else os << "        acc += " << elem("tt") << ";\n";
        os << "    return acc;\n}\n";
    }
}

// ── 视图是否使用行/列索引（用于按需发射 row/col，省去每元素整数除法/取模）──
// Linear 用扁平索引、RowBroadcast 用 row、ColBroadcast 用 col、
// RowMod/RotateHalf 用 row+col（索引映射逐元素变化，见 glsl_view_read）、
// Transpose 用 row+col（data[col*stride+row]）。
inline bool glsl_view_uses_row(ExprViewKind k)
{
    return k != ExprViewKind::Linear && k != ExprViewKind::ColBroadcast &&
           k != ExprViewKind::RowGather && k != ExprViewKind::BatchMod &&
           k != ExprViewKind::BatchCol;
}
inline bool glsl_view_uses_col(ExprViewKind k)
{
    return k != ExprViewKind::Linear && k != ExprViewKind::RowBroadcast &&
           k != ExprViewKind::BatchMod && k != ExprViewKind::BatchCol;
}
// 表达式是否需要 batch 变量（BatchMod/BatchCol 视图 / Batch 操作数）
inline bool glsl_spec_uses_batch(const ExprSpec& spec)
{
    for (const auto& v : spec.views)
        if (static_cast<ExprViewKind>(v.kind) == ExprViewKind::BatchMod ||
            static_cast<ExprViewKind>(v.kind) == ExprViewKind::BatchCol)
            return true;
    for (const auto& ins : spec.instrs)
    {
        const ExprOperand* ops[3] = {&ins.a, &ins.b, &ins.c};
        const std::size_t nops = expr_instr_num_operands(static_cast<ExprOp>(ins.op));
        for (std::size_t oi = 0; oi < nops; ++oi)
            if (ops[oi]->kind == static_cast<uint8_t>(ExprOperandKind::Batch)) return true;
    }
    return false;
}

// ── vec4 向量化资格 ───────────────────────────────────────────────────────
// 仅当全部视图 ∈ {Linear, RowBroadcast, ColBroadcast} 时才可把 4 个相邻元素
// 打包成 vec4（RowMod/RotateHalf 的索引映射逐通道变化，v1 不向量化）。
// 含前置 matmul 段（MatmulSpec）的表达式也不向量化（每元素 K 循环点积）。
// 注意：cols 是运行时 push constant，故向量化路径用运行时 `cols%4==0` 守卫，
// 任意形状仍走同 kernel 内的标量回退——正确性不依赖编译期形状。
inline bool glsl_vec4_eligible(const ExprSpec& spec)
{
    if (spec.matmul) return false;
    for (const auto& v : spec.views)
    {
        const auto k = static_cast<ExprViewKind>(v.kind);
        if (k != ExprViewKind::Linear && k != ExprViewKind::RowBroadcast &&
            k != ExprViewKind::ColBroadcast)
            return false;
    }
    // 索引操作数（Row/Col/Batch）逐通道变化 → 不向量化
    for (const auto& ins : spec.instrs)
    {
        const ExprOperand* ops[3] = {&ins.a, &ins.b, &ins.c};
        const std::size_t nops = expr_instr_num_operands(static_cast<ExprOp>(ins.op));
        for (std::size_t oi = 0; oi < nops; ++oi)
            if (ops[oi]->kind == static_cast<uint8_t>(ExprOperandKind::Row) ||
                ops[oi]->kind == static_cast<uint8_t>(ExprOperandKind::Col) ||
                ops[oi]->kind == static_cast<uint8_t>(ExprOperandKind::Batch))
                return false;
    }
    return true;
}

// ── 运行期 JIT 懒建 pipeline 的 kernel 元数据（Phase 2，单一来源）────────
// 引擎（compute_gpu_engine.hpp JIT miss）与生成器 .so（kernelgen.cpp 填
// nnk_kernel_meta）都从同一函数推导 → 两者永不漂移（否则 vec_width 失配 =
// dispatch 宽度错 = 静默算 1/4）。字段对应构建期 FusedShader / 后端
// FusedKernel。JIT 只产 V0（全 f32）与 V1 运行期精度分派 `#x`（alu=false）。
// FusedKernelMeta 结构定义在 expr_spec.hpp（backend.hpp 可见）。
[[nodiscard]] inline FusedKernelMeta fused_kernel_meta_of(const ExprSpec& s)
{
    FusedKernelMeta m;
    m.reduce_axis = expr_spec_reduce_axis(s);
    m.has_matmul = s.matmul ? 1u : 0u;
    m.view_param_count = expr_spec_runtime_view_param_count(s);
    m.rparam_count = expr_spec_runtime_param_count(s);
    m.vec_width = (!s.fold && m.reduce_axis < 0 && glsl_vec4_eligible(s)) ? 4u : 1u;
    m.fold_out = s.fold ? (s.fold->vec_state_len > 0 ? s.fold->vec_state_len : 1u) : 0u;
    m.fold_per_thread_row =
        (s.fold && !(s.fold->vec_state_len > 0 || s.fold->matmul)) ? 1u : 0u;
    m.pc_base_fixed = fused_pc_base_fixed(s);
    return m;
}

// ── 尾逐元素链：eval_tail(mm, row, col, batch) 函数体（GLSL 内联发射）────
// row 为 batch 内行号（全局行 = batch*m_per + row），与 Row 操作数一致。
// matmul 融合 shader（generate_glsl_matmul，K 循环后逐输出调用）与 K 切分
// 伴生归约 shader（generate_glsl_matmul_ksplit_reduce，**跨段求和之后**逐
// 输出调用）共用同一条尾链——两者的输入绑定/PC 布局同源（rows/mm_batch/
// cols/vp/consts/rparams），故 #ks 只写部分和、#kr 才跑尾链（尾链非线性，
// 不能逐段先跑再加）。n_inputs = 原结构输入数（跳过 A/B 槽）。
inline void glsl_emit_matmul_tail_fn(std::ostringstream& L, const ExprSpec& spec, ExprPrecSig sig,
                                     std::size_t n_inputs)
{
    const std::size_t last_dst = spec.instrs.empty() ? 0u : spec.instrs.back().dst;
    L << "float eval_tail(float mm, uint row, uint col, uint batch)\n{\n";
    if (!spec.instrs.empty())
    {
        const auto operand = [&](const ExprOperand& op) -> std::string
        {
            switch (op.kind)
            {
            default:
            case static_cast<uint8_t>(ExprOperandKind::Matmul):
                return "mm";
            case static_cast<uint8_t>(ExprOperandKind::Input):
                return "v" + std::to_string(op.idx);
            case static_cast<uint8_t>(ExprOperandKind::Reg):
            case static_cast<uint8_t>(ExprOperandKind::Fanout):
                return "r" + std::to_string(op.idx);
            case static_cast<uint8_t>(ExprOperandKind::Const):
                return "c" + std::to_string(op.idx);
            case static_cast<uint8_t>(ExprOperandKind::RParam):
                return "rp" + std::to_string(op.idx);
            case static_cast<uint8_t>(ExprOperandKind::Row):
                return "float(row)";  // row 参数已是 batch 内行号
            case static_cast<uint8_t>(ExprOperandKind::Col):
                return "float(col)";
            case static_cast<uint8_t>(ExprOperandKind::Batch):
                return "float(batch)";
            }
        };
        // 输入读取（跳过 matmul A/B 槽：其形状不是 (rows,cols) 网格）
        // 行索引视图（Linear/RowBroadcast/RowMod/RotateHalf）必须用**全局行**
        // grow = batch*m_per + row——CPU 参考（compute_cpu_engine read_input）
        // 以全局行 r 索引 (rows,·) 全网格输入（如注意力 m/l 的 (BH·seq,1)）；
        // Row 操作数保持 batch 内行号（上三角掩码 col > row 语义，CPU 端
        // row() = r % m_per 一致）。
        L << "    const uint m_per = rows / mm_batch;\n";
        L << "    const uint grow = batch * m_per + row;\n";
        for (std::size_t i = 0; i < n_inputs; ++i)
        {
            if (i == spec.matmul->a_input || i == spec.matmul->b_input) continue;
            const std::uint32_t vp = glsl_vp_slot(spec, i);
            L << "    const float v" << i << " = ";
            const bool tail_f16 = sig != 0 && expr_prec_sig_in_f16(sig, i);
            if (tail_f16) L << "float(";   // f16 读 → 显式转 f32（算术仍在 f32）
            glsl_view_read(L, spec.views[i], static_cast<std::uint32_t>(i), "grow*cols + col",
                           "grow", "col", vp, sig);
            if (tail_f16) L << ")";
            L << ";\n";
        }
        if (spec.num_regs > 0)
        {
            L << "    float r0";
            for (std::uint32_t r = 1; r < spec.num_regs; ++r)
                L << ", r" << r;
            L << ";\n";
        }
        for (const auto& ins : spec.instrs)
        {
            const ExprOp op = static_cast<ExprOp>(ins.op);
            const std::string dst = "r" + std::to_string(ins.dst);
            const std::string a = operand(ins.a);
            const detail::ExprOpInfo& info = detail::expr_op_info(op);
            if (info.emit == detail::ExprEmitKind::None)
                return;  // 归约指令：由 generate_glsl_reduce 处理 → 上层报错
            // 发射形态/符号查表（expr_op_table）→ 单处生成，与标量链逐字一致
            L << "    " << dst << " = "
              << glsl_alu_expr(
                     info, a, [&] { return operand(ins.b); }, [&] { return operand(ins.c); },
                     /*vec4=*/false, /*native16=*/false, /*wrap=*/false)
              << ";\n";
        }
        L << "    return r" << last_dst << ";\n";
    }
    else
    {
        // 纯 matmul（无逐元素链）：输出 = matmul 结果
        L << "    return mm;\n";
    }
    L << "}\n\n";
}

// ═══════════════════════════════════════════════════════════════════════════
//  matmul 融合 shader 生成（matmul 参与融合 + 分块升级：融合分块矩阵乘法）
//
//  处理含前置 matmul 段（ExprSpec.matmul）的**逐元素**表达式：
//    - 共享内存分块矩阵乘（结构驱动，复用 matmul_tiled.comp 思路）：
//        WorkGroup = TILE×TILE 线程（16×16 = 256），计算 BLOCK×BLOCK 输出块
//        （64×64，每线程 4×4 寄存器分块 acc[4][4]，dot() = 4 FMA）；
//        K 方向按 BK=16 分块（双缓冲，与 OP 级 matmul 同参）：load_tiles
//        协作加载 A/B 分块到 vec4 共享内存（转置感知、合并访问），tile t+1
//        的全局加载与 tile t 的计算并行发射、每 tile 单 barrier——暴露的
//        加载延迟被计算覆盖。取值依据（40HX 同参数四点交错 A/B，深=feedforward/
//        大 batch 训练，浅=小 batch 推理；% = 耗时变化，负=更快）：BK=16 双缓冲
//        相对 BK=32 双缓冲浅 -24%、深 fwd -24%、深 train -17%，四点全点最优
//        （见 AGENTS §12 ⑥）。
//    - 尾逐元素链编译为 eval_tail(mm, row, col) 函数（GLSL 内联零开销），
//      写回时每个输出元素调用一次（Matmul 操作数 → mm，"虚拟寄存器 0"）。
//    - transA/transB 是**运行期 operand layout**（PC `mm_trans`，不进 key）→
//      两条加载路径都发射、运行时经 uniform 分支选择；mm_k/mm_batch 是
//      **形状参数**（不进 key）→ push constant，运行时填充
//      （同结构不同 K/batch/转置共享一个融合 shader）。
//    - 布局：bindings 输入 0..N-1 + 输出 N（A/B 就是其中的两个输入槽）；
//      push constants: uint count, uint cols, uint rows, uint mm_k,
//                      uint mm_batch, uint mm_trans, [uint vp0..], [float c0..],
//                      [float rp0..]；
//      dispatch: (ceil(cols/BLOCK), ceil(rows/BLOCK), mm_batch)（见
//      EXPR_MATMUL_TILE/BLOCK，后端 run_fused_gpu 与生成器共用）。
//      细 tile 变体（block = EXPR_MATMUL_BLOCK_FINE = 16，键后缀 "#f"）：
//      输出块 64² → 16²、local_size 16² → 8²、每线程 4×4 → **2×2（R=2）**
//      ——网格仍 16×16 块（wgrad 形状 48 WG ≥ SM 数、摊满）、线程内 4 条
//      独立 K 链（ILP）。共享/加载/写回公式全部由 B/T 参数化流出，逐输出
//      元素的 K 累加序不变（逐 k 标量升序乘加 → 逐位一致）。R 的取舍与
//      A/B 数据见 EXPR_MATMUL_BLOCK_FINE 注释（R=4 缩块/ R=1 都更差）。
//    - 归约指令（RowSum/RowMax/...）出现在尾链时属归约组合，由
//      generate_glsl_reduce 处理（本生成器遇到归约指令返回空 → 上层报错）。
//    - K 切分变体（k_split = true，block = 细 tile 16，键后缀 "#ks"）：
//      每 WG 只算 K 的一段 [slice·span, min((slice+1)·span, mm_k))，slice =
//      gl_WorkGroupID.x / ceil(cols/BLOCK)（dispatch x = 列块数 × S）；PC 多
//      一槽 `ks_span`（16 对齐 → 段界也是 16 的倍数，vec4 快路径的 k 连续
//      判据 (kend&3)==0 成立）。**写回 = 原始部分和**（不跑尾链——尾链非
//      线性，不能逐段先跑），落部分和缓冲 (S·rows, cols)，由伴生归约
//      shader（generate_glsl_matmul_ksplit_reduce，键 "#kr"）跨段求和 + 跑
//      尾链。段界替换了全部 k 上界守卫（kend 取代 mm_k）：非末段的上界是
//      段界而非 mm_k，否则会把下一段的 k 拉进本段的部分和（静默错值）。
// ═══════════════════════════════════════════════════════════════════════════
[[nodiscard]] inline std::string generate_glsl_matmul(const std::string& name, const ExprSpec& spec,
                                                      ExprPrecSig sig = 0,
                                                      std::uint32_t block = EXPR_MATMUL_BLOCK,
                                                      bool k_split = false)
{
    // block = 输出块每维元素数（64 = 默认 / 16 = 细 tile 变体 "#f"）。
    // T 按 block 选：64 → 16 线程/维（R=4 = 4×4 vec4 寄存器分块）；
    // 16 → 8 线程/维（R=2 = 2×2 标量分块，EXPR_MATMUL_TILE_FINE）。
    // R = B/T = 每线程输出边长：R=2 在"网格摊满 SM（48 WG）"与"线程内
    // ILP（4 条独立 K 链）"之间取甜点（实测见 EXPR_MATMUL_BLOCK_FINE 注释）。
    // 其余 block 值无对应计算路径 → 拒绝。
    if (block != EXPR_MATMUL_BLOCK && block != EXPR_MATMUL_BLOCK_FINE) return {};
    // K 切分变体（键 #ks）：仅细 tile 网格 + 仅**静态签名**（sig==0 或具体
    // 签名；运行期分派哨兵 0x20000 需要 `prec` PC 槽 + 输入/输出双视图，与
    // "免尾链 + 写部分和"的绑定/PC 形态不相容 → 防御性拒绝）。
    // **#ks 的输出是部分和缓冲（恒 f32）**，与注入 sig 的输出精度无关：
    // 后端按 f32 分配该缓冲（run_fused_gpu 的 use_ks 分支），故此处必须把
    // 输出声明钉成 float、写原始 acc（不做 f16 舍入）——否则 f16 签名会按
    // 2B/元素写进 4B/元素的缓冲（静默错值）。最终精度由伴生 #kr 落盘。
    if (k_split && (block != EXPR_MATMUL_BLOCK_FINE || expr_prec_sig_is_dispatch(sig))) return {};
    const MatmulSpec& mm = *spec.matmul;
    const std::size_t n_inputs = spec.views.size();
    const std::uint32_t a_slot = mm.a_input;
    const std::uint32_t b_slot = mm.b_input;
    // GQA：A/B 侧行块号（生成代码里的别名；ratio==1 时就是 batch 本身 →
    // 既有 shader 的代码逐字节不变）。别名在 main 里按需定义。
    const std::string a_blk = gqa_blk_expr(spec, a_slot);
    const std::string b_blk = gqa_blk_expr(spec, b_slot);
    // 注：mm.transA/transB **不在此处读取** —— 转置是运行期 operand layout
    // （PC `mm_trans`），两条加载路径都发射、运行时经 uniform 分支选择。
    // ── 带类型变体（Phase 2 in-kernel f16）───────────────────────────────
    // sig==0 → 全 f32：生成的就是 f32 变体源码。sig!=0 → 对应槽
    // 的缓冲区声明为 float16_t，**在全局加载处**统一转 f32（共享 tile / 内层
    // VFMA 累加 / 尾逐元素链全部保持 f32，符合 §7.2「f32 参考 + 输出舍入」）。
    // 形状/分块/双缓冲/barrier 节奏与 f32 版完全一致（只有加载粒度变化）。
    const bool sign_f16 = (sig != 0);
    // 运行期精度分派（V1）：输入/输出各声明 f32 + float16_t 双视图，
    // 加载处按 PC `prec` 走 uniform 分支 —— 一个结构一份 shader 覆盖全部签名。
    const bool disp = expr_prec_sig_is_dispatch(sig);
    const bool a_f16 = sign_f16 && expr_prec_sig_in_f16(sig, a_slot);
    const bool b_f16 = sign_f16 && expr_prec_sig_in_f16(sig, b_slot);
    const bool out_f16 = sign_f16 && expr_prec_sig_out_f16(sig);
    // T 按 block 选（见函数头注释）；B = block；R = B/T = 每线程输出边长。
    // 全部下游公式（local_size、VPT、共享维度 B/4、块锚 wg×B、写回）均以
    // T/B 为参 → 两个变体共用同一份生成代码，只有网格粒度与寄存器分块不同。
    const std::uint32_t B = block;             // 输出块每维（64 或 16）
    const std::uint32_t T =
        (B == EXPR_MATMUL_BLOCK) ? EXPR_MATMUL_TILE : EXPR_MATMUL_TILE_FINE;   // 16 或 8
    const std::uint32_t R = B / T;             // 每线程输出边长（4 或 2）
    // BK 取值：16 + 双缓冲（16KB 共享）——同参数四点交错 A/B 全点最优
    // （结论见头注释 trade-off 段）。
    constexpr std::uint32_t BK = 16;                 // K 分块宽度
    constexpr std::uint32_t BK4 = BK / 4;            // vec4 数/行（4）
    // 每线程协作加载 vec4 数/矩阵（B×BK4 slots / T² 线程）：R=4 → 1；
    // R=2 → 1（64 slots = 64 线程，恰满）；为 0 时凑 1 并由 e < tile_v4 守卫。
    const std::uint32_t vpt_raw = (B * BK4) / (T * T);
    const std::uint32_t VPT = vpt_raw > 0u ? vpt_raw : 1u;
    const std::uint32_t tile_v4 = B * BK4;   // tile 的 vec4 总数（256 / 64）

    std::ostringstream L;
    L << "// ── 自动生成（AOT 算子融合 · matmul 分块 4×4 双缓冲），请勿手动编辑 ──\n";
    L << "// 表达式: " << name;
    if (sign_f16 && !disp) L << "   [精度 " << expr_prec_sig_str(sig, n_inputs) << "]";
    else if (disp) L << "   [运行期精度分派]";
    L << "\n";
    L << "#version 450\n\n";
    if (sign_f16) L << "#extension GL_EXT_shader_16bit_storage : require\n\n";
    if (sign_f16) L << glsl_f16_rne_source();
    L << "layout(local_size_x = " << T << ", local_size_y = " << T << ") in;\n\n";
    for (std::size_t i = 0; i < n_inputs; ++i)
    {
        L << "layout(std430, binding = " << i << ") readonly buffer Buf" << i << " { "
          << ((disp || (sign_f16 && expr_prec_sig_in_f16(sig, i))) ? (disp ? "float" : "float16_t")
                                                                   : "float")
          << " b" << i << "[]; };\n";
        if (disp)
            L << "layout(std430, binding = " << (n_inputs + i) << ") readonly buffer Buf" << i
              << "h { float16_t b" << i << "h[]; };\n";
    }
    if (disp)
    {
        L << "layout(std430, binding = " << (2 * n_inputs)
          << ") writeonly buffer BufOut { float bout[]; };\n";
        L << "layout(std430, binding = " << (2 * n_inputs + 1)
          << ") writeonly buffer BufOuth { float16_t bout16[]; };\n";
    }
    else
        // k_split 时输出 = 部分和缓冲（后端按 f32 分配）→ 声明恒 float
        //（见本函数头 k_split 段：写的是原始部分和，不做精度落盘）。
        L << "layout(std430, binding = " << n_inputs << ") writeonly buffer BufOut { "
          << ((out_f16 && !k_split) ? "float16_t" : "float") << " bout[]; };\n";
    // vec4 别名视图（A/B 全局快路径专用；同 binding 双声明 std430，op 级
    // matmul_tiled 同款）。a_slot==b_slot 时不发别名、快路径整体关闭。
    // f16 槽的别名用 uvec2（4×half = 8B，std430 步长恰好 8）→ 由
    // unpackHalf2x16 解出 4 个 f32；f32 槽仍是 vec4。
    const bool vec4_ok = (a_slot != b_slot);
    if (vec4_ok)
    {
        if (disp)
        {
            L << "layout(std430, binding = " << a_slot << ") readonly buffer BufAv4 { vec4 b"
              << a_slot << "v4[]; };\n";
            L << "layout(std430, binding = " << b_slot << ") readonly buffer BufBv4 { vec4 b"
              << b_slot << "v4[]; };\n";
            L << "layout(std430, binding = " << (n_inputs + a_slot)
              << ") readonly buffer BufAv4h { uvec2 b" << a_slot << "v4h[]; };\n";
            L << "layout(std430, binding = " << (n_inputs + b_slot)
              << ") readonly buffer BufBv4h { uvec2 b" << b_slot << "v4h[]; };\n";
        }
        else
        {
            const auto alias_type = [&](std::uint32_t slot) -> const char*
            { return (sign_f16 && expr_prec_sig_in_f16(sig, slot)) ? "uvec2" : "vec4"; };
            L << "layout(std430, binding = " << a_slot << ") readonly buffer BufAv4 { "
              << alias_type(a_slot) << " b" << a_slot << "v4[]; };\n";
            L << "layout(std430, binding = " << b_slot << ") readonly buffer BufBv4 { "
              << alias_type(b_slot) << " b" << b_slot << "v4[]; };\n";
        }
    }
    L << "\n";
    // 别名槽的 vec4 读取表达式（f16 → unpackHalf2x16；f32 → 直接别名）
    const auto vec4_load = [&](std::uint32_t slot, const std::string& idx) -> std::string
    {
        const std::string arr = "b" + std::to_string(slot) + "v4[" + idx + "]";
        if (disp)
            return "((prec >> " + std::to_string(slot) +
                   "u & 1u) != 0u ? vec4("
                   "unpackHalf2x16(b" +
                   std::to_string(slot) + "v4h[" + idx + "].x), unpackHalf2x16(b" +
                   std::to_string(slot) + "v4h[" + idx + "].y)) : " + arr + ")";
        if (sign_f16 && expr_prec_sig_in_f16(sig, slot))
            return "vec4(unpackHalf2x16(" + arr + ".x), unpackHalf2x16(" + arr + ".y))";
        return arr;
    };
    L << "layout(push_constant) uniform PC {\n";
    L << "    uint count;\n";
    L << "    uint cols;\n";
    L << "    uint rows;\n";
    L << "    uint mm_k;      // matmul 求和维度（形状参数，运行时填充）\n";
    L << "    uint mm_batch;  // matmul 批量数（形状参数，运行时填充；dispatch z）\n";
    L << "    uint mm_trans;  // bit0=transA, bit1=transB（运行期 operand layout，不进 key）\n";
    if (k_split)
        L << "    uint ks_span;   // K 切分段宽（段 k 上界 = 段起点 + 本槽；后端保证 "
             "16 对齐 → vec4 快路径 k 连续判据成立）\n";
    if (disp) L << "    uint prec;      // 运行期精度分派位（bit i=输入 i 为 f16，bit16=输出）\n";
    const std::uint32_t n_vp = expr_spec_runtime_view_param_count(spec);
    for (std::uint32_t i = 0; i < n_vp; ++i)
        L << "    uint vp" << i << ";\n";
    for (std::size_t i = 0; i < spec.consts.size(); ++i)
        L << "    float c" << i << ";\n";
    const std::uint32_t n_rp = static_cast<std::uint32_t>(spec.rparams.size());
    for (std::uint32_t i = 0; i < n_rp; ++i)
        L << "    float rp" << i << ";\n";
    L << "};\n\n";
    // 共享内存分块（op 级 matmul_tiled 配方：vec4 沿 m/n，16B 对齐，双缓冲 [stage]）：
    //   Ash[stage][k][m/4]：vec4 = 同 k 的 4 个连续行（Bsh 同构沿列）→ 主循环
    //     每 k 仅 2 次 LDS + 4 VFMA.128（vec4 若沿 k 布局则主循环退化为
    //     16 dot ≈5× 指令发射，是融合 matmul 落后 op 级 ~2× 的布局）；
    //     同 ty/tx 广播读无 bank 冲突。
    //   BK=16 + 双缓冲：Ash/Bsh 各 [2][16][16]vec4 = 8KB，合计 16KB——恰在
    //   Vulkan 规范共享内存下限 16KB 之内（合规设备均可创建 pipeline）；
    //   stage 交替：tile t 用 t&1。
    L << "shared vec4 Ash[2][" << BK << "][" << B / 4u << "];\n";
    L << "shared vec4 Bsh[2][" << BK << "][" << B / 4u << "];\n\n";
    // 分组归约视图的读取辅助函数（本生成器的尾链也调用 glsl_view_read）：
    // 与 generate_glsl_reduce 同理——不发射会让含该视图的 spec 生成未声明函数。
    glsl_emit_grouped_reduce_helpers(L, spec, sig, /*f16_native=*/false);


    // transA/transB 感知的全局内存加载表达式（batch：A/B 按 batch 垂直
    // 切分，batch*m_per 为 A 行偏移 / batch*mm_k 为 B k 偏移；row/col 为
    // **batch 内**坐标，block 偏移由调用方并入）
    // ── 全局内存加载表达式（batch：A/B 按 batch 垂直切分，batch*m_per 为 A
    //    行偏移 / batch*mm_k 为 B k 偏移；row/col 为 **batch 内**坐标，block
    //    偏移由调用方并入）。trans 由调用方按运行期 mm_trans 的两条分支分别传
    //    常量（true/false）——两条路径都发射，运行时经 uniform 分支选择 ──
    const auto a_load = [&](const std::string& row_e, const std::string& k_e, bool trans)
    {
        const std::string idx =
            trans ? "((" + a_blk + "*mm_k + (" + k_e + "))*m_per + (" + row_e + "))"
                  : "((" + a_blk + "*m_per + (" + row_e + "))*mm_k + (" + k_e + "))";
        const std::string an = "b" + std::to_string(a_slot);
        if (disp)
            return "((prec >> " + std::to_string(a_slot) + "u & 1u) != 0u ? float(" + an + "h[" +
                   idx + "]) : " + an + "[" + idx + "])";
        const std::string raw = an + "[" + idx + "]";
        return a_f16 ? ("float(" + raw + ")") : raw;
    };
    const auto b_load = [&](const std::string& col_e, const std::string& k_e, bool trans)
    {
        const std::string idx =
            trans ? "((" + b_blk + "*cols + (" + col_e + "))*mm_k + (" + k_e + "))"
                  : "((" + b_blk + "*mm_k + (" + k_e + "))*cols + (" + col_e + "))";
        const std::string bn = "b" + std::to_string(b_slot);
        if (disp)
            return "((prec >> " + std::to_string(b_slot) + "u & 1u) != 0u ? float(" + bn + "h[" +
                   idx + "]) : " + bn + "[" + idx + "])";
        const std::string raw = bn + "[" + idx + "]";
        return b_f16 ? ("float(" + raw + ")") : raw;
    };

    // ── 尾逐元素链：eval_tail(mm, row, col, batch)（与 #kr 共用同一实现）──
    glsl_emit_matmul_tail_fn(L, spec, sig, n_inputs);

    // ── load_tiles：协作加载 A/B 分块（BK×B）→ 指定 stage。双缓冲流水的
    //    发射端：前奏调 load_tiles(0,0)，主循环内 if (t+1<num_tiles)
    //    load_tiles(t+1, nstage) 与 tile t 的计算并行 ─────────────────────
    //    分组 = 沿内存连续维取 vec4（op 级 matmul_tiled v3 同款）；转置是
    //    **运行期** operand layout（mm_trans）→ 每种转置两条路径都发射、
    //    运行时 uniform 分支选择；%4 对齐与边界是
    //    uniform 分支（mm_k/m_per/cols 运行时才知道），未对齐/尾块走同分组
    //    标量回退 → 每个 (k,m) 恰被写一次（快路径与回退的写集合相同）。共享槽位恒用
    //    tile 内坐标，越界判/全局地址才用 block_row/col + tile 偏移。
    L << "void load_tiles(uint t, uint stage)\n{\n";
    L << "    const uint tid = gl_LocalInvocationID.y * " << T << "u + gl_LocalInvocationID.x;\n";
    L << "    const uint batch = gl_WorkGroupID.z;\n";
    L << "    const uint m_per = rows / mm_batch;\n";
    L << "    const uint block_row = gl_WorkGroupID.y * " << B << "u;\n";
    // K 切分（键 #ks）：本 WG 的 K 段 [k_lo, kend)，slice = 列块序号
    // （dispatch x = 列块数 × S）。⚠ 列块号必须是 **wg.x % nx**——slice>0 的
    // wg.x ≥ nx，直接 ×B 会把列块推出 cols、写回被 cc<cols 守卫整块丢弃
    // （slice≥1 部分和从未写出 → #kr 读池垃圾；K 切分首版 offload/探针
    // FAIL 的根因）。非切分时 = wg.x/0 偏移退化为原式（编译期折叠）。
    // 非切分时 k_lo/kend = 0/mm_k（编译期折叠为原式）。
    // ⚠ vec4 快路径的 (kend&3)==0 判据由后端的 span 16 对齐保证（非末段
    // 段界必是 16 倍数；末段 = mm_k，回原判据）。
    if (k_split)
    {
        L << "    const uint nx = (cols + " << B << "u - 1u) / " << B << "u;\n";
        L << "    const uint block_col = (gl_WorkGroupID.x % nx) * " << B << "u;\n";
        L << "    const uint k_lo = (gl_WorkGroupID.x / nx) * ks_span;\n";
        L << "    const uint kend = k_lo + ks_span < mm_k ? k_lo + ks_span : mm_k;\n";
    }
    else
    {
        L << "    const uint block_col = gl_WorkGroupID.x * " << B << "u;\n";
        L << "    const uint k_lo = 0u;\n";
        L << "    const uint kend = mm_k;\n";
    }
    L << "    for (uint l = 0u; l < " << VPT << "u; ++l)\n";
    L << "    {\n";
    L << "    const uint e = tid * " << VPT << "u + l;\n";
    // 细 tile（R=2，64 线程）：vec4 总数 = B×BK4 = 64，e = tid ∈[0,64)
    // 恰好全载（守卫兜底）；R=4（256 线程）时 tile_v4=256 守卫恒真、
    // 编译期消除——两变体共用同一条发射路径。
    L << "    if (e >= " << tile_v4 << "u) continue;\n";
    // A 的两条加载路径**都发射**，运行时按 mm_trans bit0 选择（转置是运行期
    //    operand layout，不进 key）。两条路径的共享槽位写入集合相同。
    L << "    if ((mm_trans & 1u) != 0u)   // transA: A 存 (K,M)\n";
    L << "    {\n";
    {
        // A 存 (K,M)：沿行连续 → vec4 整读 4 行同 k，直写共享
        L << "    const uint kAL = e / " << (B / 4u) << "u;\n";
        L << "    const uint kAG = k_lo + t * " << BK << "u + kAL;\n";
        L << "    const uint mA4 = e % " << (B / 4u) << "u;\n";
        L << "    const uint arG = block_row + mA4 * 4u;\n";
        L << "    if (" << (vec4_ok ? "((m_per & 3u) == 0u)" : "false")
          << " && kAG < kend && arG < m_per)\n";
        L << "    {\n";
        L << "        Ash[stage][kAL][mA4] = "
          << vec4_load(a_slot, "(((" + a_blk + "*mm_k + (kAG))*m_per + (arG))) >> 2") << ";\n";
        L << "    }\n    else\n    {\n";
        L << "        for (uint j = 0u; j < 4u; ++j)\n        {\n";
        L << "            const float v = (arG + j < m_per && kAG < kend) ? "
          << a_load("arG + j", "kAG", true) << " : 0.0;\n";
        L << "            Ash[stage][kAL][mA4][j] = v;\n";
        L << "        }\n    }\n";
    }
    L << "    }\n    else\n    {\n";
    {
        // A 行主序：沿 k 连续 → vec4 散写 4 个共享行（op 级 k_contig 同构）
        L << "    const uint kAL = (e % " << BK4 << "u) * 4u;\n";
        L << "    const uint kAG = k_lo + t * " << BK << "u + kAL;\n";
        L << "    const uint arT = e / " << BK4 << "u;\n";
        L << "    const uint arG = block_row + arT;\n";
        // ⚠ vec4 快路径双重对齐判据：(kend&3)==0 保证段内 k 连续
        // （kAG..kAG+3 < 段界），(mm_k&3)==0 保证**行基对齐**——该路径的
        // 别名索引 = grow*mm_k + kAG（>>2），行跨度是 mm_k：K 非 4 倍数时
        // （如 vocab=257 的 dgrad）只查 kend 会把跨行错位的 vec4 当连续读
        // （K 切分首版实测 offload 一致性测试全挂的根因）。非切分时
        // kend==mm_k → 与原判据等价。
        L << "    if (" << (vec4_ok ? "((mm_k & 3u) == 0u && (kend & 3u) == 0u)" : "false")
          << " && arG < m_per && kAG < kend)\n";
        L << "    {\n";
        L << "        const vec4 v = "
          << vec4_load(a_slot, "(((" + a_blk + "*m_per + (arG))*mm_k + (kAG))) >> 2") << ";\n";
        L << "        Ash[stage][kAL    ][arT >> 2][arT & 3u] = v.x;\n";
        L << "        Ash[stage][kAL + 1u][arT >> 2][arT & 3u] = v.y;\n";
        L << "        Ash[stage][kAL + 2u][arT >> 2][arT & 3u] = v.z;\n";
        L << "        Ash[stage][kAL + 3u][arT >> 2][arT & 3u] = v.w;\n";
        L << "    }\n    else\n    {\n";
        L << "        for (uint j = 0u; j < 4u; ++j)\n        {\n";
        L << "            const float v = (arG < m_per && kAG + j < kend) ? "
          << a_load("arG", "kAG + j", false) << " : 0.0;\n";
        L << "            Ash[stage][kAL + j][arT >> 2][arT & 3u] = v;\n";
        L << "        }\n    }\n";
    }
    L << "    }\n";
    // B 的两条加载路径同样都发射，运行时按 mm_trans bit1 选择。
    L << "    if ((mm_trans & 2u) != 0u)   // transB: B 存 (N,K)\n";
    L << "    {\n";
    {
        // B 存 (N,K)：沿 k 连续 → vec4 散写 4 个共享行
        L << "    const uint kBL = (e % " << BK4 << "u) * 4u;\n";
        L << "    const uint kBG = k_lo + t * " << BK << "u + kBL;\n";
        L << "    const uint nT = e / " << BK4 << "u;\n";
        L << "    const uint bcG = block_col + nT;\n";
        // 同 A 行主序：别名索引 = 行*mm_k + kBG → 行基对齐要 (mm_k&3)==0，
        // 段内 k 连续要 (kend&3)==0（两者缺一即错读；非切分时等价原判据）
        L << "    if (" << (vec4_ok ? "((mm_k & 3u) == 0u && (kend & 3u) == 0u)" : "false")
          << " && bcG < cols && kBG < kend)\n";
        L << "    {\n";
        L << "        const vec4 v = "
          << vec4_load(b_slot, "(((" + b_blk + "*cols + (bcG))*mm_k + (kBG))) >> 2") << ";\n";
        L << "        for (uint j = 0u; j < 4u; ++j)\n";
        L << "            Bsh[stage][kBL + j][nT >> 2][nT & 3u] = v[j];\n";
        L << "    }\n    else\n    {\n";
        L << "        for (uint j = 0u; j < 4u; ++j)\n        {\n";
        L << "            const float v = (bcG < cols && kBG + j < kend) ? "
          << b_load("bcG", "kBG + j", true) << " : 0.0;\n";
        L << "            Bsh[stage][kBL + j][nT >> 2][nT & 3u] = v;\n";
        L << "        }\n    }\n";
    }
    L << "    }\n    else\n    {\n";
    {
        // B (K,N) 行主序：沿列连续 → vec4 整读 4 列同 k，直写共享
        L << "    const uint kBL = e / " << (B / 4u) << "u;\n";
        L << "    const uint kBG = k_lo + t * " << BK << "u + kBL;\n";
        L << "    const uint nB4 = e % " << (B / 4u) << "u;\n";
        L << "    const uint bcG = block_col + nB4 * 4u;\n";
        L << "    if (" << (vec4_ok ? "((cols & 3u) == 0u)" : "false")
          << " && kBG < kend && bcG < cols)\n";
        L << "    {\n";
        L << "        Bsh[stage][kBL][nB4] = "
          << vec4_load(b_slot, "(((" + b_blk + "*mm_k + (kBG))*cols + (bcG))) >> 2") << ";\n";
        L << "    }\n    else\n    {\n";
        L << "        for (uint j = 0u; j < 4u; ++j)\n        {\n";
        L << "            const float v = (kBG < kend && bcG + j < cols) ? "
          << b_load("bcG + j", "kBG", false) << " : 0.0;\n";
        L << "            Bsh[stage][kBL][nB4][j] = v;\n";
        L << "        }\n    }\n";
    }
    L << "    }\n";
    L << "    }\n";
    L << "}\n\n";

    // ── main：4×4 寄存器分块 batched matmul（dispatch (x,y,z) = (列块,行块,批次)）
    L << "void main()\n{\n";
    L << "    const uint tx = gl_LocalInvocationID.x;\n";
    L << "    const uint ty = gl_LocalInvocationID.y;\n";
    L << "    const uint tid = ty * " << T << "u + tx;\n";
    L << "    const uint batch = gl_WorkGroupID.z;   // 批次下标\n";
    L << "    const uint m_per = rows / mm_batch;    // 每批输出行数\n";
    L << "    const uint block_row = gl_WorkGroupID.y * " << B << "u;\n";
    // K 切分（键 #ks）：本 WG 只算 K 段 [k_lo, kend)，slice = 列块序号。
    // 空段（k_lo ≥ mm_k，段宽 16 对齐 + 段数非整除时可能）整 WG 早退——
    // 段号只依赖 gl_WorkGroupID → WG 内 uniform，早退先于一切 barrier 安全。
    // ⚠ 列块 = **wg.x % nx**（slice>0 的 wg.x 直接 ×B 会越界丢写——见
    // load_tiles 同款注释）。
    if (k_split)
    {
        L << "    const uint nx = (cols + " << B << "u - 1u) / " << B << "u;\n";
        L << "    const uint slice = gl_WorkGroupID.x / nx;\n";
        L << "    const uint block_col = (gl_WorkGroupID.x % nx) * " << B << "u;\n";
        L << "    const uint k_lo = slice * ks_span;\n";
        L << "    const uint kend = k_lo + ks_span < mm_k ? k_lo + ks_span : mm_k;\n";
        L << "    if (k_lo >= mm_k) return;\n";
    }
    else
    {
        L << "    const uint block_col = gl_WorkGroupID.x * " << B << "u;\n";
        L << "    const uint k_lo = 0u;\n";
        L << "    const uint kend = mm_k;\n";
    }
    // 累加器：R=4 → vec4 acc[4]（16 输出/线程，每 k 4 条 VFMA.128）；
    // R=2 → 4 个标量（2×2 输出/线程，4 条独立 K 链 = 线程内 ILP）。
    // 两者每输出都是逐 k 标量升序乘加 → 累加序一致（逐位一致）。
    if (R == 2) { L << "    float a00 = 0.0, a01 = 0.0, a10 = 0.0, a11 = 0.0;\n"; }
    else
    {
        L << "    vec4 acc[4];\n";
        L << "    for (uint i = 0u; i < 4u; ++i)\n";
        L << "        acc[i] = vec4(0.0);\n";
    }

    // 前奏：加载 tile 0 → stage 0；此后每迭代发射 t+1 的加载（stage^1），
    // 与 tile t 的计算并行，单 barrier 收口（与 matmul_tiled.comp v2 同构：
    // 暴露的全局加载延迟被 tile t 的计算覆盖）
    L << "    const uint num_tiles = (kend - k_lo + " << BK - 1 << "u) / " << BK << "u;\n";
    L << "    load_tiles(0u, 0u);\n";
    L << "    barrier();\n";
    L << "    uint stage = 0u;\n";
    L << "    for (uint t = 0u; t < num_tiles; ++t)\n";
    L << "    {\n";
    L << "        const uint nstage = stage ^ 1u;\n";
    L << "        if (t + 1u < num_tiles)\n";
    L << "            load_tiles(t + 1u, nstage);\n";
    // 内层：每 k 读 2 个 vec4（Ash[k][ty] = 4 行、Bsh[k][tx] = 4 列）+ 4
    // VFMA.128（op 级 matmul_tiled 同款；同槽广播读无 bank 冲突）
    if (R == 2)
    {
        // R=2：行对 ty*2、ty*2+1 → 共享行组 (ty*2)>>2 = ty>>1、组内基
        // (ty*2)&3 = (ty&1)*2；列对同构。每 k：2 次 vec4 LDS + 4 标量 FMA。
        L << "        for (uint k = 0u; k < " << BK << "u; ++k)\n";
        L << "        {\n";
        L << "            const vec4 av = Ash[stage][k][ty >> 1u];\n";
        L << "            const vec4 bv = Bsh[stage][k][tx >> 1u];\n";
        L << "            const float ar0 = av[(ty & 1u) * 2u];\n";
        L << "            const float ar1 = av[(ty & 1u) * 2u + 1u];\n";
        L << "            const float bc0 = bv[(tx & 1u) * 2u];\n";
        L << "            const float bc1 = bv[(tx & 1u) * 2u + 1u];\n";
        L << "            a00 += ar0 * bc0;\n";
        L << "            a01 += ar0 * bc1;\n";
        L << "            a10 += ar1 * bc0;\n";
        L << "            a11 += ar1 * bc1;\n";
        L << "        }\n";
    }
    else
    {
        L << "        for (uint k = 0u; k < " << BK << "u; ++k)\n";
        L << "        {\n";
        L << "            const vec4 av = Ash[stage][k][ty];\n";
        L << "            const vec4 bv = Bsh[stage][k][tx];\n";
        L << "            acc[0] += av.x * bv;\n";
        L << "            acc[1] += av.y * bv;\n";
        L << "            acc[2] += av.z * bv;\n";
        L << "            acc[3] += av.w * bv;\n";
        L << "        }\n";
    }
    L << "        barrier();\n";
    L << "        stage = nstage;\n";
    L << "    }\n";

    // ── 写回：各输出元素执行一次尾链（边界守卫；rr 全局行，
    //    eval_tail 的 row 参数 = batch 内行号）──
    if (R == 2)
    {
        // R=2：2×2 每线程 4 输出（行 = ty*2+i、列 = tx*2+j）——
        // 4 条独立 K 链 = 线程内 ILP，网格保持 16×16 块（48 WG 摊满 SM）
        L << "    {\n";
        L << "        const uint r0 = block_row + ty * 2u;\n";
        L << "        const uint c0 = block_col + tx * 2u;\n";
        L << "        const float accs[4] = float[4](a00, a01, a10, a11);\n";
        L << "        for (uint i = 0u; i < 2u; ++i)\n";
        L << "            for (uint j = 0u; j < 2u; ++j)\n";
        L << "            {\n";
        L << "                const uint rr = r0 + i;\n";
        L << "                const uint cc = c0 + j;\n";
        L << "                if (rr < m_per && cc < cols)\n";
        if (k_split)
        {
            // #ks：写**原始部分和**到 (S·rows, cols) 部分和缓冲的段行
            // slice*rows + grow（不跑尾链——尾链非线性，须在 #kr 跨段求和
            // 之后统一执行）。部分和缓冲恒 f32（后端 use_ks 分支分配），
            // 故此处不做任何精度落盘、`bout` 声明恒 float —— 与注入的 sig
            // 无关（sig 只决定 A/B 的读取类型）。
            L << "                    bout[(slice * rows + batch * m_per + rr) * cols + cc] =\n";
            L << "                        accs[i * 2u + j];\n";
        }
        else if (disp)
        {
            L << "                {\n";
            L << "                    const uint oi = (batch * m_per + rr) * cols + cc;\n";
            L << "                    const float ev = "
              << "eval_tail(accs[i * 2u + j], rr, cc, batch);\n";
            L << "                    if ((prec >> 16u & 1u) != 0u)\n";
            L << "                        bout16[oi] = " << glsl_f16_store("ev") << ";\n";
            L << "                    else\n";
            L << "                        bout[oi] = ev;\n";
            L << "                }\n";
        }
        else
        {
            L << "                    bout[(batch * m_per + rr) * cols + cc] =\n";
            L << "                        "
              << (out_f16 ? glsl_f16_store("eval_tail(accs[i * 2u + j], rr, cc, batch)")
                          : std::string("eval_tail(accs[i * 2u + j], rr, cc, batch)"))
              << ";\n";
        }
        L << "            }\n";
        L << "    }\n";
    }
    else
    {
        L << "    #pragma unroll\n";
        L << "    for (uint i = 0u; i < 4u; ++i)\n";
        L << "        for (uint j = 0u; j < 4u; ++j)\n";
        L << "        {\n";
        L << "            const uint rr = block_row + ty * 4u + i;\n";
        L << "            const uint cc = block_col + tx * 4u + j;\n";
        L << "            if (rr < m_per && cc < cols)\n";
        if (disp)
        {
            L << "            {\n";
            L << "                const uint oi = (batch * m_per + rr) * cols + cc;\n";
            L << "                if ((prec >> 16u & 1u) != 0u)\n";
            L << "                    bout16[oi] = "
              << glsl_f16_store("eval_tail(acc[i][j], rr, cc, batch)") << ";\n";
            L << "                else\n";
            L << "                    bout[oi] = eval_tail(acc[i][j], rr, cc, batch);\n";
            L << "            }\n";
        }
        else
        {
            L << "                bout[(batch * m_per + rr) * cols + cc]\n";
            L << "                    = "
              << (out_f16 ? glsl_f16_store("eval_tail(acc[i][j], rr, cc, batch)")
                          : std::string("eval_tail(acc[i][j], rr, cc, batch)"))
              << ";\n";
        }
        L << "        }\n";
    }
    L << "}\n";
    return L.str();
}

// ═══════════════════════════════════════════════════════════════════════════
//  K 切分伴生归约 shader 生成（键 = 结构 key + "#kr"）
//
//  K 切分变体（#ks，generate_glsl_matmul 的 k_split 分支）的第二段派发：
//  读 (S·rows, cols) 部分和缓冲，按**段号升序左折**求和还原每输出元素的
//  matmul 值，再跑与 V0/#ks 同一条尾链（glsl_emit_matmul_tail_fn 同源）
//  写最终输出。
//    - 绑定：0..N-1 = 原输入（尾链读）+ N = 部分和 + N+1 = 输出。
//      注册行用「原 spec + 追加一个视图」的合成 spec（fused_generate）→
//      num_bindings = (N+1)+1 = N+2，与本生成器逐槽同源。
//    - PC 固定头 6 槽与 matmul 同布局（注册 has_matmul=1 → pc_base_fixed=6）：
//      {count, cols, rows, **ks_slices（复用 mm_k 槽位置）**, mm_batch,
//      mm_trans} + vp… + c… + rp…；#kr 不读 mm_trans（后端填 0）。
//      尾链读 rows/mm_batch/cols/vp/consts/rparams——与 #ks 同一 PC 形态，
//      故两者元数据（vp/rp/consts 计数）共用基础结构。
//    - 网格：local_size 256、每线程一个输出元素，dispatch = ceil(count/256)
//      （与 run_fused_gpu 的 kr 分支同源）。
//    - 求和序 = 段升序左折（确定性）。**与未切分的逐 k 串联不逐位一致**
//      （浮点加法不结合）→ 移动 GPU 字节锚；裁定放行（torch 文档同样不保证
//      数学等价计算逐位一致，见 history「K 切分」条）。
// ═══════════════════════════════════════════════════════════════════════════
[[nodiscard]] inline std::string generate_glsl_matmul_ksplit_reduce(const std::string& name,
                                                                    const ExprSpec& spec,
                                                                    ExprPrecSig sig = 0)
{
    // 资格 = 与 #ks/细 tile 同源：纯 matmul、无 fold、raxis<0、**静态签名**
    // （sig==0 或具体签名；运行期分派哨兵与 #ks 同款被拒——它的 `prec` PC
    // 槽 + 双视图与"部分和缓冲恒 f32"的绑定形态不相容）、无 extras（多输出
    // 结构不产 K 切分变体）。防御性拒绝，返回空 → 上层 [skip]，运行期留在
    // 细 tile 路径（降级，不是错误）。
    if (expr_prec_sig_is_dispatch(sig) || spec.fold || !spec.matmul ||
        expr_spec_reduce_axis(spec) != -1 || !spec.extras.empty())
        return {};
    const std::size_t n_inputs = spec.views.size();
    if (n_inputs + 2 > EXPR_MAX_INPUTS + 2) return {};

    // 输入/输出按注入签名选元素类型；**部分和缓冲恒 f32**（后端 use_ks 分支
    // 按 f32 分配，与 sig 的输出精度无关）。尾链的读取表达式由
    // glsl_emit_matmul_tail_fn(sig) 同源产出 → 两处声明必须逐槽一致。
    const bool sign_f16 = (sig != 0);
    const bool out_f16 = sign_f16 && expr_prec_sig_out_f16(sig);

    std::ostringstream L;
    L << "// ── 自动生成（AOT 算子融合 · matmul K 切分二次归约），请勿手动编辑 ──\n";
    L << "// 表达式: " << name << "   [K 切分归约 #kr：段升序求和 + 尾链]\n";
    L << "#version 450\n\n";
    if (sign_f16) L << "#extension GL_EXT_shader_16bit_storage : require\n\n";
    if (out_f16) L << glsl_f16_rne_source();   // glsl_f16_store 依赖（RNE 预舍入）
    L << "layout(local_size_x = 256) in;\n\n";
    for (std::size_t i = 0; i < n_inputs; ++i)
        L << "layout(std430, binding = " << i << ") readonly buffer Buf" << i << " { "
          << ((sign_f16 && expr_prec_sig_in_f16(sig, i)) ? "float16_t" : "float") << " b" << i
          << "[]; };\n";
    L << "layout(std430, binding = " << n_inputs
      << ") readonly buffer BufPart { float bpart[]; };\n";
    L << "layout(std430, binding = " << (n_inputs + 1) << ") writeonly buffer BufOut { "
      << (out_f16 ? "float16_t" : "float") << " bout[]; };\n";
    L << "\n";
    // 分组归约视图辅助（尾链含 GroupedReduce 视图时需要；纯 Linear 时为空）
    glsl_emit_grouped_reduce_helpers(L, spec, sig, /*f16_native=*/false);
    L << "layout(push_constant) uniform PC {\n";
    L << "    uint count;\n";
    L << "    uint cols;\n";
    L << "    uint rows;\n";
    L << "    uint ks_slices;  // 有效段数 V = ceil(mm_k/span)（后端在 mm_k 槽位填入；"
         "空段不派发也不参与求和）\n";
    L << "    uint mm_batch;   // 批量数（m_per = rows / mm_batch）\n";
    L << "    uint mm_trans;   // 占位（matmul 同布局固定头；#kr 不读）\n";
    const std::uint32_t n_vp = expr_spec_runtime_view_param_count(spec);
    for (std::uint32_t i = 0; i < n_vp; ++i)
        L << "    uint vp" << i << ";\n";
    for (std::size_t i = 0; i < spec.consts.size(); ++i)
        L << "    float c" << i << ";\n";
    for (std::size_t i = 0; i < spec.rparams.size(); ++i)
        L << "    float rp" << i << ";\n";
    L << "};\n\n";
    // 同一条尾链（在跨段求和之后执行）
    glsl_emit_matmul_tail_fn(L, spec, sig, n_inputs);

    L << "void main()\n{\n";
    L << "    const uint gi = gl_GlobalInvocationID.x;\n";
    L << "    if (gi >= count) return;\n";
    L << "    const uint m_per = rows / mm_batch;\n";
    L << "    const uint grow = gi / cols;   // 全局行（batch*m_per + rr）\n";
    L << "    const uint col = gi - grow * cols;\n";
    L << "    const uint batch = grow / m_per;\n";
    L << "    const uint rr = grow - batch * m_per;\n";
    // 段号升序左折：acc = ((p0 + p1) + p2) + …（确定性；跨段序 ≠ 逐 k 序）
    L << "    float acc = bpart[grow * cols + col];\n";
    L << "    for (uint s = 1u; s < ks_slices; ++s)\n";
    L << "        acc += bpart[(s * rows + grow) * cols + col];\n";
    L << "    bout[gi] = "
      << (out_f16 ? glsl_f16_store("eval_tail(acc, rr, col, batch)")
                  : std::string("eval_tail(acc, rr, col, batch)"))
      << ";\n";
    L << "}\n";
    return L.str();
}

// ── 生成器主入口：ExprSpec → GLSL 源码 ────────────────────────────────────
// 生成的 shader 绑定：输入 buffer binding=0..N-1，输出 binding=N；
// push constants: uint count, uint cols, [float c0..]（视图索引需要 cols）。
// 逐元素表达式若 glsl_vec4_eligible，发射 vec4 kernel：每线程处理 4 个相邻元素
// （vec4 加载/运算/存储），dispatch 宽度 4（run_fused_gpu 按 vec_width 缩放）；
// 运行时 cols%4!=0 或尾部回退到同 kernel 内标量循环。其余表达式发纯标量 kernel。
// ═══════════════════════════════════════════════════════════════════════════
//  fold v1 生成器（标量域：分块状态归约 FoldSpec）
//
//  线程映射：**每线程一行**（WG=256，dispatch = ceil(rows/256)）——状态是
//  每行标量、块循环由该线程串行推进。与 CpuEngine::eval_fold_impl 完全同序
//  （同分块 EXPR_FOLD_BLOCK / 同指令序 / 同归约结合序 / 同尾块 gate）→
//  GPU 对拍**期望逐位一致**（fold v2 向量化时才引入 subgroup 归约差异）。
//  PC 形态：{count, cols, rows, vector_out, fold_k} + vp… + consts… + rparams…
//    cols = 输入列数 K（glsl_view_read 索引用）；fold_k = K（块循环上界）。
//    与后端 run_fused_gpu 的 fold 形态组包必须逐字段一致（PC 固定头坑，
//    见 docs/contributors/pitfalls.md §4.10）。
//  寄存器物化：状态/标量类 = float r{n}；元素类 = float e{n}[BLOCK]（块内每
//    kb 一值）；块归约 dst = float red{n}（行标量，经 Reduce 操作数广播）。
//  状态初值一律 bit_cast → uintBitsToFloat 字面量（±inf/任意 float 零精度损失，
//    同 reduce 生成器 -inf 风格）。
// ═══════════════════════════════════════════════════════════════════════════
inline std::string generate_glsl_fold(const std::string& name, const ExprSpec& spec,
                                      ExprPrecSig sig = 0)
{
    // 形态由 validate_expr_spec 保证；防御性拒绝一切越界组合
    if (!spec.fold || spec.matmul || !spec.instrs.empty()) return {};
    const FoldSpec& f = *spec.fold;
    auto cls = expr_fold_classify(f, spec.num_regs);
    if (!cls) return {};
    const std::vector<uint8_t>& is_elem = *cls;
    const std::size_t n_inputs = spec.views.size();
    // 带类型变体：f16 输入直读（float() 转 f32 归约——状态/累加全
    // float，f16 只在存储边界）+ f16 输出落回（(rows,1)/(rows,vector_out)）。
    // 运行期精度分派（V1）：双视图 + PC `prec`（同 generate_glsl）。
    const bool disp = expr_prec_sig_is_dispatch(sig);
    const bool out_f16 = sig != 0 && expr_prec_sig_out_f16(sig);
    const auto in_type = [&](std::size_t i) -> const char*
    { return (sig != 0 && expr_prec_sig_in_f16(sig, i)) ? "float16_t" : "float"; };

    std::vector<uint8_t> is_block_reduce(spec.num_regs, 0);
    for (const auto& ins : f.body)
        if (expr_op_is_reduce(static_cast<ExprOp>(ins.op))) is_block_reduce[ins.dst] = 1;

    // ── 归约输入内联（通用生成优化）─────────────────────────
    // 块归约的元素源若**只被归约消费**（可沿 def 链传递），把其定义表达式
    // 逐 kb 重算、直接内联进归约循环——省掉 e{n}[BLOCK] 物化（动态下标私有
    // 数组在多数驱动落 local memory：实测 CE 的 logsumexp fold 因此慢 2.4×）
    // 与多余的整块扫趟（4 趟 → 2 趟）。内联重算与逐指令物化是**同一表达式
    // 同一 kb 序**求值 → 逐位一致（铁律 8）；"唯一消费者"约束保证每 kb 恰算
    // 一次（表达式纯，无副作用重复求值问题）。
    std::vector<uint8_t> inlineable(spec.num_regs, 0);
    {
        std::vector<int> use_count(spec.num_regs, 0);
        std::vector<int> single_use(spec.num_regs, -1);
        for (std::size_t ii = 0; ii < f.body.size(); ++ii)
        {
            const auto& ins = f.body[ii];
            const ExprOp op = static_cast<ExprOp>(ins.op);
            const std::size_t nops = expr_op_is_reduce(op) ? 1 : expr_instr_num_operands(op);
            const ExprOperand* ops[3] = {&ins.a, &ins.b, &ins.c};
            for (std::size_t oi = 0; oi < nops; ++oi)
            {
                const auto k = static_cast<ExprOperandKind>(ops[oi]->kind);
                if ((k == ExprOperandKind::Reg || k == ExprOperandKind::Fanout) &&
                    ops[oi]->idx < spec.num_regs)
                {
                    ++use_count[ops[oi]->idx];
                    single_use[ops[oi]->idx] = static_cast<int>(ii);
                }
            }
        }
        // 不动点：唯一消费者是块归约、或其唯一消费所在指令自身已内联 → 可内联
        bool changed = true;
        while (changed)
        {
            changed = false;
            for (std::uint32_t r = 0; r < spec.num_regs; ++r)
            {
                if (!is_elem[r] || inlineable[r] || use_count[r] != 1) continue;
                const ExprInstr& u = f.body[static_cast<std::size_t>(single_use[r])];
                const bool via_reduce = expr_op_is_reduce(static_cast<ExprOp>(u.op));
                const bool via_inlined = is_elem[u.dst] && inlineable[u.dst];
                if (via_reduce || via_inlined)
                {
                    inlineable[r] = 1;
                    changed = true;
                }
            }
        }
    }

    std::ostringstream L;
    L << "// ── 自动生成（AOT 算子融合 · fold 分块状态归约），请勿手动编辑 ──\n";
    L << "// 表达式: " << name << "\n";
    L << "#version 450\n\n";
    if (sig != 0) L << "#extension GL_EXT_shader_16bit_storage : require\n\n";
    if (sig != 0) L << glsl_f16_rne_source();
    L << "layout(local_size_x = 256) in;\n\n";
    for (std::size_t i = 0; i < n_inputs; ++i)
    {
        L << "layout(std430, binding = " << i << ") readonly buffer Buf" << i << " { "
          << (disp ? "float" : in_type(i)) << " b" << i << "[]; };\n";
        if (disp)
            L << "layout(std430, binding = " << (n_inputs + i) << ") readonly buffer Buf" << i
              << "h { float16_t b" << i << "h[]; };\n";
    }
    if (disp)
    {
        L << "layout(std430, binding = " << (2 * n_inputs)
          << ") writeonly buffer BufOut { float bout[]; };\n";
        L << "layout(std430, binding = " << (2 * n_inputs + 1)
          << ") writeonly buffer BufOuth { float16_t bout16[]; };\n\n";
    }
    else
        L << "layout(std430, binding = " << n_inputs << ") writeonly buffer BufOut { "
          << (out_f16 ? "float16_t" : "float") << " bout[]; };\n\n";
    L << "layout(push_constant) uniform PC {\n";
    L << "    uint count;\n";
    L << "    uint cols;\n";
    L << "    uint rows;\n";
    L << "    uint vector_out;\n";
    L << "    uint fold_k;\n";
    if (disp) L << "    uint prec;      // 运行期精度分派位（bit i=输入 i 为 f16，bit16=输出）\n";
    const std::uint32_t n_vp = expr_spec_runtime_view_param_count(spec);
    for (std::uint32_t i = 0; i < n_vp; ++i)
        L << "    uint vp" << i << ";\n";
    for (std::size_t i = 0; i < spec.consts.size(); ++i)
        L << "    float c" << i << ";\n";
    for (std::size_t i = 0; i < spec.rparams.size(); ++i)
        L << "    float rp" << i << ";\n";
    L << "};\n\n";

    L << "void main()\n{\n";
    L << "    const uint row = gl_GlobalInvocationID.x;\n";
    L << "    if (row >= rows) return;\n";

    // 寄存器物化（元素类 = 块内数组；其余 = 标量）+ 块归约行标量
    // （可内联元素寄存器不物化：消费点归约循环内逐 kb 重算）
    for (std::uint32_t r = 0; r < spec.num_regs; ++r)
    {
        if (is_elem[r] && inlineable[r]) continue;
        if (is_elem[r]) L << "    float e" << r << "[" << EXPR_FOLD_BLOCK << "];\n";
        else L << "    float r" << r << ";\n";
    }
    for (std::uint32_t r = 0; r < spec.num_regs; ++r)
        if (is_block_reduce[r]) L << "    float red" << r << ";\n";
    // 状态初值（bit_cast → uintBitsToFloat：±inf 与任意 float 均零精度损失）
    for (std::uint8_t s = 0; s < f.num_state; ++s)
    {
        const std::uint32_t bits = std::bit_cast<std::uint32_t>(f.inits[s]);
        L << "    r" << static_cast<int>(s) << " = uintBitsToFloat(0x" << std::hex << bits
          << std::dec << "u);\n";
    }

    // 操作数 → GLSL 片段；kbv = 块内下标变量（标量上下文传 "0u"——类别分析
    //   保证标量指令无元素源，该分支不可达；归约/元素上下文传 "kb"）
    const auto operand = [&](const ExprOperand& op, const std::string& kbv) -> std::string
    {
        switch (op.kind)
        {
        default:
        case static_cast<uint8_t>(ExprOperandKind::Reg):
        case static_cast<uint8_t>(ExprOperandKind::Fanout):
            return is_elem[op.idx] ? ("e" + std::to_string(op.idx) + "[" + kbv + "]")
                                   : ("r" + std::to_string(op.idx));
        case static_cast<uint8_t>(ExprOperandKind::Const):
            return "c" + std::to_string(op.idx);
        case static_cast<uint8_t>(ExprOperandKind::RParam):
            return "rp" + std::to_string(op.idx);
        case static_cast<uint8_t>(ExprOperandKind::Reduce):
            return "red" + std::to_string(op.idx);
        case static_cast<uint8_t>(ExprOperandKind::Input):
        {
            const std::string gk = "(k0 + " + kbv + ")";   // 全局收缩下标
            std::ostringstream os;
            const bool f16_in = sig != 0 && expr_prec_sig_in_f16(sig, op.idx);
            if (f16_in) os << "float(";
            glsl_view_read(os, spec.views[op.idx], op.idx, "(row * cols + " + gk + ")", "row", gk,
                           glsl_vp_slot(spec, op.idx), sig);
            if (f16_in) os << ")";
            return os.str();
        }
        }
    };
    // 指令 → 赋值语句（dst_str 已含下标/变量名），直接写入 L
    const auto emit_assign =
        [&](const ExprInstr& ins, const std::string& dst_str, const std::string& kbv)
    {
        const ExprOp op = static_cast<ExprOp>(ins.op);
        const std::string a = operand(ins.a, kbv);
        // 发射形态/符号查表（expr_op_table）；归约指令由调用方分流（不达此处）
        const detail::ExprOpInfo& info = detail::expr_op_info(op);
        if (info.emit == detail::ExprEmitKind::None)
        {
            L << dst_str << " = (" << a << ");\n";
            return;
        }
        L << dst_str << " = "
          << glsl_alu_expr(
                 info, a, [&] { return operand(ins.b, kbv); }, [&] { return operand(ins.c, kbv); },
                 /*vec4=*/false, /*native16=*/false, /*wrap=*/false)
          << ";\n";
    };

    // ── 内联表达式文本（递归展开可内联元素寄存器；与 emit_assign 同形）────
    const auto def_of = [&](std::uint32_t r) -> const ExprInstr*
    {
        for (const auto& d : f.body)
            if (d.dst == r) return &d;
        return nullptr;
    };
    std::function<std::string(const ExprOperand&, const std::string&)> opnd_inl;
    std::function<std::string(const ExprInstr&, const std::string&)> expr_inl;
    opnd_inl = [&](const ExprOperand& o, const std::string& kbv) -> std::string
    {
        if ((o.kind == static_cast<uint8_t>(ExprOperandKind::Reg) ||
             o.kind == static_cast<uint8_t>(ExprOperandKind::Fanout)) &&
            o.idx < spec.num_regs && is_elem[o.idx] && inlineable[o.idx])
        {
            if (const ExprInstr* d = def_of(o.idx)) return expr_inl(*d, kbv);
        }
        return operand(o, kbv);
    };
    expr_inl = [&](const ExprInstr& ins, const std::string& kbv) -> std::string
    {
        const ExprOp op = static_cast<ExprOp>(ins.op);
        const std::string a = opnd_inl(ins.a, kbv);
        // 内联上下文：整体再包一层括号（与语句形态逐字一致）
        const detail::ExprOpInfo& info = detail::expr_op_info(op);
        if (info.emit == detail::ExprEmitKind::None)
            return "(" + a + ")";   // 归约指令：不经内联（调用方分流）
        return glsl_alu_expr(
            info, a, [&] { return opnd_inl(ins.b, kbv); }, [&] { return opnd_inl(ins.c, kbv); },
            /*vec4=*/false, /*native16=*/false, /*wrap=*/true);
    };

    // ── 块循环（k0 步进 BLOCK；valid gate 尾块——与 CPU 同序）──────────
    L << "\n    // 分块收缩轴（与 CPU eval_fold 同分块同序 → 逐位一致）\n";
    L << "    for (uint k0 = 0u; k0 < fold_k; k0 += " << EXPR_FOLD_BLOCK << "u) {\n";
    L << "        const uint valid = min(" << EXPR_FOLD_BLOCK << "u, fold_k - k0);\n";
    for (const auto& ins : f.body)
    {
        const ExprOp op = static_cast<ExprOp>(ins.op);
        const std::string dst_r = std::to_string(ins.dst);
        if (expr_op_is_reduce(op))
        {
            const bool is_max = (op == ExprOp::RowMax || op == ExprOp::ColMax);
            // max 恒等元 = lowest() 直出（0xFF7FFFFF 即 -FLT_MAX 位型，**禁加
            // 负号**：-(-FLT_MAX)=+FLT_MAX 会让 acc 恒为 inf；亦**禁用 -inf**）：
            //   与 CPU 基准逐位对齐（eval_fold_impl 一律 numeric_limits::lowest()）。
            //   -inf 会在「块内元素全 -inf（如文档掩码屏蔽整块）且状态 m_old=-inf」
            //   时算出 blk_m=-inf → dm = m_old − m = −inf−−inf = **NaN** →
            //   l/O 全污染（fold 分块状态进位特有；两趟式对整行求 m 不触发）。
            //   lowest() 有限 → dm=−inf → exp(−inf)=0，全屏蔽块贡献恒 0，语义正确。
            // 归约源是可内联元素寄存器 → 表达式逐 kb 重算内联（无 e[] 物化）
            const bool src_inlined =
                (ins.a.kind == static_cast<uint8_t>(ExprOperandKind::Reg) ||
                 ins.a.kind == static_cast<uint8_t>(ExprOperandKind::Fanout)) &&
                ins.a.idx < spec.num_regs && is_elem[ins.a.idx] && inlineable[ins.a.idx];
            const auto src_at = [&](const std::string& kbv)
            { return src_inlined ? expr_inl(*def_of(ins.a.idx), kbv) : operand(ins.a, kbv); };
            // ── 循环剥离 + 预取（软件流水，通用）─────────────────────────
            // 直写 `acc = acc + f(load(kb))` 是逐迭代 load→f→add 的**串行依赖
            // 链**（动态 valid 抑制编译器自动流水）：实测 fold v1 因此比同工作
            // 量的归约 kernel 慢 ~3×（16K 线程 × 16K 迭代 × 数百周期延迟隐藏
            // 不了）。剥离首迭代、把 kb+1 的源表达式先算进 vn 再累加 v（上一
            // 迭代值）——访存/表达式求值与累加重叠。**累加序仍为 kb 升序逐个
            // 累加 → 与 CPU eval_fold 逐位一致**（铁律 8）。
            L << "        { float acc = " << (is_max ? "uintBitsToFloat(0xFF7FFFFFu)" : "0.0")
              << ";\n";
            L << "          float v = " << src_at("0u") << ";\n";
            L << "          for (uint kb = 1u; kb < valid; ++kb) {\n";
            L << "            const float vn = " << src_at("kb") << ";\n";
            L << "            acc = " << (is_max ? "max(acc, v)" : "(acc + v)") << ";\n";
            L << "            v = vn;\n";
            L << "          }\n";
            L << "            acc = " << (is_max ? "max(acc, v)" : "(acc + v)") << ";\n";
            L << "          red" << dst_r << " = acc; }\n";
        }
        else if (!is_elem[ins.dst])
        {
            L << "        ";
            emit_assign(ins, "r" + dst_r, "0u");
        }
        else if (inlineable[ins.dst])
        {
            // 可内联元素临时：不物化（消费点归约循环内逐 kb 重算）
        }
        else
        {
            L << "        for (uint kb = 0u; kb < valid; ++kb) {\n";
            L << "          ";
            emit_assign(ins, "e" + dst_r + "[kb]", "kb");
            L << "        }\n";
        }
    }
    L << "    }\n";

    // ── finalize（每行一次；源仅状态/常量/rparam——validate 保证）────────
    L << "\n    // finalize\n";
    for (const auto& ins : f.finalize)
    {
        L << "    ";
        emit_assign(ins, "r" + std::to_string(ins.dst), "0u");
    }
    if (disp)
    {
        L << "    if ((prec >> 16u & 1u) != 0u)\n";
        L << "        bout16[row] = "
          << glsl_f16_store("r" + std::to_string(static_cast<int>(f.finalize.back().dst))) << ";\n";
        L << "    else\n";
        L << "        bout[row] = r" << static_cast<int>(f.finalize.back().dst) << ";\n";
    }
    else
        L << "    bout[row] = "
          << (out_f16
                  ? glsl_f16_store("r" + std::to_string(static_cast<int>(f.finalize.back().dst)))
                  : ("r" + std::to_string(static_cast<int>(f.finalize.back().dst))))
          << ";\n";
    L << "}\n";
    return L.str();
}

// ═══ fold v2 生成器（双域：键域[mm+掩码+归约] / vecacc / 向量域）══════
// 线程映射：local_size=256；v2 = 每 WG NR 行（EXPR_FOLD_ROWS_PER_WG），
//   row = gl_WorkGroupID.x*NR + ri（后端 dispatch 同源 ceil(rows/NR)；
//   FoldMeta{out, per_thread_row}，ceil(count/256) 只属 v1）；
//   行循环外置 → Ash/sreg/spart/smm 跨行复用（shared 零增长，NR 摊薄按
//   WG 计费的固定成本）；越界行 clamp+row_ok 写回守卫（全 WG 均匀无发散）。
//   - 键域元素段（A 段）：j 分片 `j = tid; j < valid; j += 256`（valid ≤
//     EXPR_FOLD_BLOCK）；mm 段收缩 s[j]=Σ_d A·B 在块首 Ash 预载 + spart/smm
//     协作归约求得
//     （Matmul 操作数读 smm[j]；链内不做现场串行 Σ_d——现场串行是吞吐回退主因）；
//   - 元素类寄存器跨段传递 = shared 全量读写 `sreg[NELEM][BLOCK]` + 每段后
//     barrier（免 live 分析；def-before-use 由 validate 静态保证）；
//   - 归约本体：subgroup shuffleDown 蝶式（lane0 落 sred → barrier 广播）。
//     规范保证 subgroup ⊆ workgroup，AMD wave64 经 gl_SubgroupSize 泛化安全
//     （跨 WG 混 lane 的顾虑对合规驱动不成立；串行扫描实测占 fold ~11%，
//     故不取串行扫描）；
//   - 行向量态 O：线程按 `dd = tid; dd < vector_out; dd += 256` 步进分片
//     （寄存器跨块持久；输出列数=veclen **运行时读 PC 的 vector_out 槽**——
//     形状无关，同 key 服务任意 d_k）；oi 上界 4（veclen ≤ FOLD_MAX_VEC）。
// PC 形态（fold+matmul = 7 槽 / 纯 fold = 5 槽）：
//   count, cols(=键长), rows, vector_out(=输出列数，运行时), fold_k,
//   [mm_k, mm_batch], vp.., c.., rp..
//   ——创建侧 push range / 写入侧 pc_base / 本声明必须三处同改（不同步 =
//   PC 错位静默错值；坑记录见 docs/contributors/pitfalls.md §4.10）。
inline std::string generate_glsl_fold_v2(const std::string& name, const ExprSpec& spec,
                                         ExprPrecSig sig = 0)
{
    if (!spec.fold || spec.matmul || !spec.instrs.empty()) return {};
    const FoldSpec& f = *spec.fold;
    auto cls = expr_fold_classify(f, spec.num_regs);
    if (!cls) return {};
    const std::vector<uint8_t>& is_elem = *cls;
    std::vector<int> eidx(spec.num_regs, -1);
    int ne = 0;
    for (std::uint32_t r = 0; r < spec.num_regs; ++r)
        if (is_elem[r]) eidx[r] = ne++;
    // OUTC_MAX 由单一事实源 FOLD_MAX_VEC 派生（1024/256=4；手写 4 会在
    //   抬高 FOLD_MAX_VEC 时让生成的 o[(dd-tid)/256] 静默越界）
    constexpr std::uint32_t OUTC_MAX = (FOLD_MAX_VEC + 255u) / 256u;
    // vecacc 每线程累加器数（P2-2）：j 按 (j-jlo)%VA_ACC 分组拆掉单累加器
    //   长链（旧版 256 次 FMA 串行依赖链卡住块间全部屏障）；与 4 路加载
    //   流水同宽（加载组 = 累加组，尾循环同式）。求和序因此异于旧版左折叠
    //   → GPU 字节锚移动（已立项批准）；CPU 左折叠不受影响，对拍走容差。
    constexpr std::uint32_t VA_ACC = 4u;
    const std::size_t n_inputs = spec.views.size();
    const bool has_mm = f.matmul.has_value();
    // 带类型变体：f16 输入直读（读处 float() 转 f32——mm/vecacc/
    // 链算术全 float）+ f16 输出落回。
    const bool disp = expr_prec_sig_is_dispatch(sig);
    const bool out_f16 = sig != 0 && expr_prec_sig_out_f16(sig);
    const auto in_type = [&](std::size_t i) -> const char*
    { return (sig != 0 && expr_prec_sig_in_f16(sig, i)) ? "float16_t" : "float"; };
    // 直接下标读（mm 段 A/B、vecacc B——非视图，平铺索引）：f16 输入包 float()。
    // 入参是**纯下标表达式**（如 "(batch*mm_k + d)*cols + col"），缓冲名由本
    // 函数按分派位拼出 f32 / f16 两个视图——此前实现是"在下标串里做子串
    // 替换找 `b<i>[` 换成 `b<i>h[`"，找不到时静默保留 f32 视图名、把 2 字节
    // 缓冲按 float 读（编译期不报错，运行期错值）。
    const auto in_rd = [&](std::size_t i, const std::string& idx) -> std::string
    {
        const std::string an = "b" + std::to_string(i);
        const std::string f32e = an + "[" + idx + "]";
        if (disp)
            return "((prec >> " + std::to_string(i) + "u & 1u) != 0u ? float(" + an + "h[" + idx +
                   "]) : " + f32e + ")";
        return (sig != 0 && expr_prec_sig_in_f16(sig, i)) ? ("float(" + f32e + ")") : f32e;
    };
    // 输出列数 **运行时读 PC 的 vector_out 槽**（形状无关：同 key 服务任意
    // d_k——veclen 若进 key 则每个 dk 一个 shader、闭合世界必然缺登记）

    std::ostringstream L;
    L << "// ── 自动生成（AOT 算子融合 · fold v2 双域），请勿手动编辑 ──\n";
    L << "// 表达式: " << name << "\n";
    L << "#version 450\n";
    // 前提：gl_SubgroupSize 为 2 的幂（桌面 wave32/64 恒真）——非 2 幂时
    //   shuffleDown 蝶形 off>>=1 折叠不全会漏部分和（无运行时守护，记为
    //   书面前提）；`: require` 与 matmul_gemv 的限定符口径统一
    L << "#extension GL_KHR_shader_subgroup_basic : require\n";              // gl_SubgroupSize
    L << "#extension GL_KHR_shader_subgroup_shuffle_relative : require\n\n"; // subgroupShuffleDown
    if (sig != 0) L << "#extension GL_EXT_shader_16bit_storage : require\n\n";
    if (sig != 0) L << glsl_f16_rne_source();
    L << "layout(local_size_x = 256) in;\n\n";
    for (std::size_t i = 0; i < n_inputs; ++i)
    {
        L << "layout(std430, binding = " << i << ") readonly buffer Buf" << i << " { "
          << (disp ? "float" : in_type(i)) << " b" << i << "[]; };\n";
        if (disp)
            L << "layout(std430, binding = " << (n_inputs + i) << ") readonly buffer Buf" << i
              << "h { float16_t b" << i << "h[]; };\n";
    }
    if (disp)
    {
        L << "layout(std430, binding = " << (2 * n_inputs)
          << ") writeonly buffer BufOut { float bout[]; };\n";
        L << "layout(std430, binding = " << (2 * n_inputs + 1)
          << ") writeonly buffer BufOuth { float16_t bout16[]; };\n\n";
    }
    else
        L << "layout(std430, binding = " << n_inputs << ") writeonly buffer BufOut { "
          << (out_f16 ? "float16_t" : "float") << " bout[]; };\n\n";
    L << "layout(push_constant) uniform PC {\n";
    L << "    uint count;\n    uint cols;\n    uint rows;\n"
         "    uint vector_out;\n    uint fold_k;\n";
    if (has_mm) L << "    uint mm_k;\n    uint mm_batch;\n";
    if (disp) L << "    uint prec;      // 运行期精度分派位（bit i=输入 i 为 f16，bit16=输出）\n";
    const std::uint32_t n_vp = expr_spec_runtime_view_param_count(spec);
    for (std::uint32_t i = 0; i < n_vp; ++i)
        L << "    uint vp" << i << ";\n";
    for (std::size_t i = 0; i < spec.consts.size(); ++i)
        L << "    float c" << i << ";\n";
    for (std::size_t i = 0; i < spec.rparams.size(); ++i)
        L << "    float rp" << i << ";\n";
    L << "};\n\n";
    if (ne > 0)
    {
        L << "shared float sreg[" << ne << "][" << EXPR_FOLD_BLOCK << "];\n";
        L << "shared float sred[1];\n"; // subgroup 归约 lane0 落点 → barrier 广播
    }
    if (has_mm)
    {
        // mm 段吞吐化：A 操作数行预载 shared（32+ 个 j 复用 → 消 A 重读）
        // + 每块 spart/smm 协作归约。尺寸/映射随 EXPR_FOLD_BLOCK 参数化：
        //   jm = tid & (BLOCK-1)、grp = tid >> log2(BLOCK)（组数 = 256/BLOCK）、
        //   d 步进 = 256/BLOCK。
        L << "shared float Ash[" << FOLD_MAX_MMK << "];\n";
        L << "shared float spart[" << EXPR_FOLD_BLOCK << "][" << (256u / EXPR_FOLD_BLOCK) << "];\n";
        L << "shared float smm[" << EXPR_FOLD_BLOCK << "];\n";
    }
    if (f.vecacc && !has_mm)
        // vecacc 末尾跨线程列归约槽（每线程一槽，256 槽）；有 mm 段时复用
        //   spart（块循环结束后空闲 → 零 shared 增长；注意力 fold 恒带 mm）
        L << "shared float sva[256];\n";

    L << "void main()\n{\n";
    L << "    const uint tid = gl_LocalInvocationID.x;\n";
    // 标量寄存器声明（一次；仅行标量类——元素类寄存器在链 j 循环内就地
    //   声明（float r{n} = sreg[..][j]），validate 保证 S/F 上下文不读元素
    //   寄存器 → 外层声明必成死变量；状态初值/o 初始化下沉到行循环内按行重置）
    for (std::uint32_t r = 0; r < spec.num_regs; ++r)
        if (!is_elem[r]) L << "    float r" << r << ";\n";
    // ── NR 行/WG 外层循环（同一行结构原样按 ri 重放；Ash/sreg/spart/smm
    //    跨行复用 → shared 零增长。ri 循环边界对全 WG 均匀（体内含屏障，
    //    禁分支发散）；越界行 clamp 到末行重复算、写回由 row_ok 挡掉。──
    L << "    for (uint ri = 0u; ri < " << EXPR_FOLD_ROWS_PER_WG << "u; ++ri) {\n";
    L << "      const uint row_r = gl_WorkGroupID.x * " << EXPR_FOLD_ROWS_PER_WG << "u + ri;\n";
    L << "      const uint row = min(row_r, rows - 1u);\n";
    L << "      const bool row_ok = row_r < rows;\n";
    if (has_mm)
    {
        L << "      const uint m_per = rows / mm_batch;\n";
        L << "      const uint batch = row / m_per;\n";
        L << "      const uint row_in = row - batch * m_per;\n";
        // Q 行按行预载 shared（整行 dk 个，256 线程步进；A 的 d 维布局按 transA）
        L << "      for (uint d = tid; d < mm_k; d += 256u) {\n";
        // GQA：A 侧行块号——HeadGroup 视图时按 vp 槽里的头分组比取（1 = 恒等）
        const std::string a_blk = gqa_blk_expr(spec, f.matmul->a_input);
        if (f.matmul->transA)
            L << "        Ash[d] = "
              << in_rd(f.matmul->a_input, "(" + a_blk + " * mm_k + d) * m_per + row_in") << ";\n";
        else
            L << "        Ash[d] = "
              << in_rd(f.matmul->a_input, "(" + a_blk + " * m_per + row_in) * mm_k + d") << ";\n";
        L << "      }\n";
        L << "      barrier();   // Ash 就绪（每行预载，块循环前一次）\n";
    }
    // 状态初值（每行重置）
    for (std::uint8_t s = 0; s < f.num_state; ++s)
    {
        const std::uint32_t bits = std::bit_cast<std::uint32_t>(f.inits[s]);
        L << "      r" << static_cast<int>(s) << " = uintBitsToFloat(0x" << std::hex << bits
          << std::dec << "u);\n";
    }
    // 行向量态（P2-2 双形态）：
    //   路径 B（0<vs≤256）热路径 = **标量累加器 ob0..**（恒寄存器）。动态
    //   下标的 o[][] 若被驱动落到 local/scratch，每次累加的 RMW 是 GB 级
    //   流量——实测把 o 全槽(16)缩放/初始化 + 标量累加换成数组后 fold
    //   反慢 27%（P2-2 首版 A/B），故数组对路径 B **只作 finalize 接口**：
    //   收尾各写一次 o[0][0]（下标常量），未初始化槽路径 B 从不读。
    //   路径 A（vs>256）保留数组（dd 动态分片无法标量化），行首按可达分片
    //   初始化（× VA_ACC 累加器；收尾崩叠进 [0]，finalize 只读 [0]）。
    if (f.vecacc)
    {
        L << "      float o[" << OUTC_MAX << "][" << VA_ACC << "];\n";
        L << "      if (vector_out > 256u) {\n";
        L << "        for (uint oi = 0u; oi < " << OUTC_MAX << "u; ++oi)\n";
        L << "          for (uint an = 0u; an < " << VA_ACC << "u; ++an) o[oi][an] = 0.0;\n";
        L << "      }\n";
        for (std::uint32_t t = 0; t < VA_ACC; ++t)
            L << "      float ob" << t << " = 0.0;\n";
    }

    // ── 操作数 → GLSL 片段。ctx：'E'=链(j 上下文) 'R'=归约源(内层 j)
    //    'S'=标量行(无 j) 'F'=finalize(dd 上下文)。──
    // （mm 段输出在块首以 smm[] 协作计算——链内不做现场串行 Σ_d，
    //   现场串行是吞吐回退主因，见块循环头）
    const auto operand = [&](const ExprOperand& op, char ctx, const std::string& jv) -> std::string
    {
        switch (op.kind)
        {
        default:
        case static_cast<uint8_t>(ExprOperandKind::Reg):
        case static_cast<uint8_t>(ExprOperandKind::Fanout):
            if (is_elem[op.idx] && (ctx == 'R'))
                return "sreg[" + std::to_string(eidx[op.idx]) + "][" + jv + "]";
            return "r" + std::to_string(op.idx);
        case static_cast<uint8_t>(ExprOperandKind::Const):
            return "c" + std::to_string(op.idx);
        case static_cast<uint8_t>(ExprOperandKind::RParam):
            return "rp" + std::to_string(op.idx);
        case static_cast<uint8_t>(ExprOperandKind::Reduce):
            return "r" + std::to_string(op.idx); // 归约 dst 每线程副本
        case static_cast<uint8_t>(ExprOperandKind::Matmul):
            // mm 段结果已在块首协作算入 smm[]（见块循环头）——链内直接读，
            //   不做现场串行 Σ_d（现场串行结构是吞吐回退主因）
            return "smm[" + jv + "]";
        case static_cast<uint8_t>(ExprOperandKind::Row):
            return "float(row % m_per)";
        case static_cast<uint8_t>(ExprOperandKind::Col):
            return "float(k0 + " + jv + ")";
        case static_cast<uint8_t>(ExprOperandKind::Batch):
            return "float(batch)";
        case static_cast<uint8_t>(ExprOperandKind::VecState):
        {
            // finalize：dd 步进分片 → oi = (dd - tid)/256；[0] = 崩叠后的
            //   最终值（收尾段把 VA_ACC 个累加器求和进 [0]，路径 B 还多一道
            //   跨线程列归约后写 [0]——finalize 只读 [0]）
            (void)ctx;
            return "o[(dd - tid) / 256u][0]";
        }
        case static_cast<uint8_t>(ExprOperandKind::Input):
        {
            const std::string gk = "(k0 + " + jv + ")";
            std::ostringstream os;
            const bool f16_in = sig != 0 && expr_prec_sig_in_f16(sig, op.idx);
            if (f16_in) os << "float(";
            glsl_view_read(os, spec.views[op.idx], op.idx, "(row * cols + " + gk + ")", "row", gk,
                           glsl_vp_slot(spec, op.idx), sig);
            if (f16_in) os << ")";
            return os.str();
        }
        }
    };
    // 指令 → 赋值语句（dst_str = 目标表达式）
    const auto emit_assign = [&](const ExprInstr& ins, const std::string& dst_str, char ctx,
                                 const std::string& jv) -> std::string
    {
        const ExprOp op = static_cast<ExprOp>(ins.op);
        const std::string a = operand(ins.a, ctx, jv);
        // 发射形态/符号查表（expr_op_table）
        const detail::ExprOpInfo& info = detail::expr_op_info(op);
        if (info.emit == detail::ExprEmitKind::None)
            return "          " + dst_str + " = (" + a + ");\n"; // 归约：调用方分流
        return "          " + dst_str + " = " +
               glsl_alu_expr(
                   info, a, [&] { return operand(ins.b, ctx, jv); },
                   [&] { return operand(ins.c, ctx, jv); },
                   /*vec4=*/false, /*native16=*/false, /*wrap=*/false) +
               ";\n";
    };

    // ── 块循环 + body 段扫描发射 ─────────────────────────────────────────
    L << "\n    for (uint k0 = 0u; k0 < fold_k; k0 += " << EXPR_FOLD_BLOCK << "u) {\n";
    if (f.tri_skip)
    {
        // 行界整块/边界跳过（qt = row%m_per，与链内 select 谓词同源）：
        //   上三角类掩码使 k0>qt 的键位全被屏蔽 → 该整块 valid=0 空转
        //   （smm/链/归约/vecacc 全由 valid 门控），边界块钳到 qt+1-k0。
        //   跳过项恰为链内 -inf/0 屏蔽值 → 恒等，与 CPU 全量逐位一致；
        //   valid 仅依赖 row/k0 → 全 WG 均匀，体内屏障无发散。
        //   注：tri_skip 只由带 mm 段的掩码构造（恒带 mm）置位，m_per 必有定义。
        L << "        const uint qt = row % m_per;\n";
        L << "        const uint valid = min(min(" << EXPR_FOLD_BLOCK
          << "u, fold_k - k0), (k0 > qt ? 0u : qt + 1u - k0));\n";
        // 整块 skip（此前 tri_skip 只钳 valid、空块仍跑满全部 WG 屏障——本机
        //   注意力 fwd 实测 (行,块) 的 1/4 命中空块）。恒等论证：空块必在
        //   block0 之后，而 block0 恒 valid≥1 且含未屏蔽对角 j=qt（causal
        //   不遮对角、doc 同位置同 id）→ 进入空块时 m 必为有限值，于是
        //   旧版空块语义 = max(m, lowest)=m、α=exp(0)=1.0（FP 精确）、
        //   l=l·1.0+0、o×1.0 全部逐位恒等 → 跳过与旧版逐位一致
        //   （valid 只依赖 row/k0 → 全 WG 均匀，continue 路径一致无发散）。
        L << "        if (valid == 0u) continue;   // 整块跳过（恒等，见上）\n";
    }
    else
    {
        L << "        const uint valid = min(" << EXPR_FOLD_BLOCK << "u, fold_k - k0);\n";
    }
    if (has_mm)
    {
        // mm 段收缩协作化（映射随 BLOCK 参数化，见 shared 声明处注释）
        const MatmulSpec& m = *f.matmul;
        constexpr std::uint32_t LG = []()
        {
            std::uint32_t v = EXPR_FOLD_BLOCK, g = 0;
            while (v > 1)
            {
                v >>= 1;
                ++g;
            }
            return g;
        }();
        constexpr std::uint32_t NG = 256u / EXPR_FOLD_BLOCK; // d 组数
        L << "        const uint jm = tid & " << (EXPR_FOLD_BLOCK - 1) << "u;\n";
        L << "        const uint grp = tid >> " << LG << "u;\n";
        L << "        float part = 0.0;\n";
        L << "        if (jm < valid) {\n";
        L << "          for (uint d = grp; d < mm_k; d += " << NG << "u) {\n";
        // GQA：B 侧行块号——HeadGroup 视图时按 vp 槽里的头分组比取
        const std::string b_blk = gqa_blk_expr(spec, m.b_input);
        if (m.transB)
            L << "            part += Ash[d] * "
              << in_rd(m.b_input, "(" + b_blk + " * cols + (k0 + jm)) * mm_k + d") << ";\n";
        else
            L << "            part += Ash[d] * "
              << in_rd(m.b_input, "(" + b_blk + " * mm_k + d) * cols + (k0 + jm)") << ";\n";
        L << "          }\n";
        L << "        }\n";
        L << "        spart[jm][grp] = part;\n";
        L << "        barrier();\n";
        L << "        if (grp == 0u) {\n";
        L << "          float s = 0.0;\n";
        L << "          for (uint g = 0u; g < " << NG << "u; ++g) s += spart[jm][g];\n";
        L << "          smm[jm] = s;\n";
        L << "        }\n";
        L << "        barrier();   // smm 就绪（链/归约的 Matmul 操作数读它）\n";
    }
    std::vector<ExprInstr> chain;
    const auto flush_chain = [&]()
    {
        if (chain.empty()) return;
        // 元素 j 循环：**按读集载入、按写集存回**（不再是全元素寄存器对称
        //   round-trip）。动机：注意力 chain1 实测 9 次 sreg 载入全为死加载
        //   （全部覆写前载入 / 本段未用）、chain2 为 9 中 8 死——纯浪费
        //   shared 读吞吐与发射。语义不变：① 首次访问为读的元素寄存器照旧
        //   载入（def-before-use 仍由 validate 静态拒）；② 链内被写的照旧
        //   存回；③ 未触达的不声明也不碰 → 出口处 shared 状态与旧版逐位一致
        //   （旧版"读到未初始化 shared 仅在 validate 漏网时发生"的情形现在
        //    连读都不发生，两者随后都被覆盖，无行为差）。
        //   操作数按 kind 收集：Reg/Fanout/Reduce 在 'E' 上下文渲染为 r{n}
        //   本地变量（其余渲染为 smm/视图/常量/网格/o[]，无需声明）；
        //   未用的 b/c 默认 (Reg,0) 而寄存器 0 恒为行标量态 → 不会误判元素。
        std::vector<bool> need_load(spec.num_regs, false);
        std::vector<bool> wr(spec.num_regs, false);
        const auto note_read = [&](const ExprOperand& op)
        {
            const bool as_local = op.kind == static_cast<uint8_t>(ExprOperandKind::Reg) ||
                                  op.kind == static_cast<uint8_t>(ExprOperandKind::Fanout) ||
                                  op.kind == static_cast<uint8_t>(ExprOperandKind::Reduce);
            if (as_local && is_elem[op.idx] && !wr[op.idx]) need_load[op.idx] = true;
        };
        for (const auto& ins : chain)
        {
            note_read(ins.a);
            note_read(ins.b);
            note_read(ins.c);
            if (is_elem[ins.dst]) wr[ins.dst] = true;
        }
        L << "        for (uint j = tid; j < valid; j += 256u) {\n";
        for (std::uint32_t r = 0; r < spec.num_regs; ++r)
        {
            if (!is_elem[r] || (!need_load[r] && !wr[r])) continue;
            L << "          float r" << r;
            if (need_load[r]) L << " = sreg[" << eidx[r] << "][j]";
            L << ";\n";
        }
        for (const auto& ins : chain)
        {
            const std::string dst = "r" + std::to_string(ins.dst);
            L << emit_assign(ins, dst, 'E', "j");
        }
        for (std::uint32_t r = 0; r < spec.num_regs; ++r)
            if (wr[r]) L << "          sreg[" << eidx[r] << "][j] = r" << r << ";\n";
        L << "        }\n";
        L << "        barrier();\n";
        chain.clear();
    };
    for (const auto& ins : f.body)
    {
        const ExprOp op = static_cast<ExprOp>(ins.op);
        if (expr_op_is_reduce(op))
        {
            flush_chain();
            const bool is_max = (op == ExprOp::RowMax || op == ExprOp::ColMax);
            const auto skind = static_cast<ExprOperandKind>(ins.a.kind);
            const bool elem_src =
                (skind == ExprOperandKind::Reg || skind == ExprOperandKind::Fanout) &&
                is_elem[ins.a.idx];
            if (elem_src)
            {
                // 归约本体（subgroup shuffle 蝶式，fold v2 吞吐路径）；
                //   备选的"256 线程各串行扫 valid"有 64 级 shared 依赖链 ×256
                //   冗余（探针量化占 fold ~11%），故取蝶式：
                //   ① gather 收在 subgroup0（tid < gl_SubgroupSize）：subgroup0
                //      以 gl_SubgroupSize 步进已完整覆盖 [0, valid) 且不重不漏
                //      （任意 subgroup 尺寸成立；flush 屏障已保证跨线程可见）——
                //      其余 subgroup 的 gather 是重复读、其 shuffle 结果全被
                //      "tid==0 落 sred"丢弃，收紧后 sred 逐位不变；
                //   ② subgroup 内 shuffleDown 蝶式 log2 归约（同样收在
                //      subgroup0——shuffle 是 subgroup 内运算，guard 按
                //      tid<gl_SubgroupSize 对每个 subgroup 均匀，无发散）；
                //      lane0 落 sred[0]；
                //   ③ barrier 广播——r{dst} 是每线程副本，标量段全 WG 读。
                //   跨设备：规范保证 subgroup ⊆ workgroup（AMD wave64 经
                //   gl_SubgroupSize 泛化，16/32/64/128 皆正确）——"免 subgroup
                //   防混邻 WG lane"的顾虑对合规驱动不成立。
                //   数值：浮点求和结合序异于 CPU 串行 → fold GPU 对拍
                //   （fused_gpu_test）容差 1e-4 兜；max 结合序无关，位级一致。
                L << "        {\n";
                // max 恒等元 = lowest()（0xFF7FFFFF）而非 -inf：与 CPU 基准
                //   eval_fold_impl(numeric_limits::lowest()) 对齐——块内全 -inf
                //   （doc 掩码整块屏蔽）时 m_old=blk_m=-inf 会让 dm=−inf−−inf
                //   =NaN 污染 l/O，见 fold v1 同款注释。
                const std::string init = is_max ? "uintBitsToFloat(0xFF7FFFFFu)" : "0.0";
                const std::string eis = std::to_string(eidx[ins.a.idx]);
                L << "          float v = " << init << ";\n";
                L << "          if (tid < gl_SubgroupSize) {\n";
                L << "            for (uint e = tid; e < valid; e += gl_SubgroupSize)\n";
                L << "              v = "
                  << (is_max ? ("max(v, sreg[" + eis + "][e])") : ("(v + sreg[" + eis + "][e])"))
                  << ";\n";
                L << "          }\n";
                L << "          if (tid < gl_SubgroupSize) {\n";
                L << "            for (uint off = gl_SubgroupSize >> 1; off > 0u; off >>= 1)\n";
                L << "              v = "
                  << (is_max ? "max(v, subgroupShuffleDown(v, off))"
                             : "(v + subgroupShuffleDown(v, off))")
                  << ";\n";
                L << "          }\n";
                L << "          if (tid == 0u) sred[0] = v;\n";
                L << "          barrier();   // sred 广播（跨 subgroup → 全 WG）\n";
                L << "          r" << std::to_string(ins.dst) << " = sred[0];\n";
                L << "        }\n";
            }
            else
            {
                // 标量源归约（罕见路径）：保持原串行扫描语义
                L << "        {\n";
                // max init = lowest()（0xFF7FFFFF），对齐 CPU 基准/防 −inf−−inf=NaN
                //   ——与上面元素源路径同款理由，两处必须同改
                L << "          float acc = " << (is_max ? "uintBitsToFloat(0xFF7FFFFFu)" : "0.0")
                  << ";\n";
                L << "          for (uint j = 0u; j < valid; ++j) {\n";
                const std::string src = operand(ins.a, 'R', "j");
                L << "            acc = "
                  << (is_max ? ("max(acc, " + src + ")") : ("(acc + " + src + ")")) << ";\n";
                L << "          }\n";
                L << "          r" << std::to_string(ins.dst) << " = acc;\n";
                L << "        }\n";
            }
        }
        else if (is_elem[ins.dst])
        {
            chain.push_back(ins); // 元素链（遇标量/归约/尾冲）
        }
        else
        {
            flush_chain();
            // 标量行（每线程副本；源全行标量——validate 保证不读元素）
            L << emit_assign(ins, "r" + std::to_string(ins.dst), 'S', "j");
        }
    }
    flush_chain();

    // ── vecacc：O *= scale；O += Σ_j w(j)·b(j, d) ──
    // P2-2 双路径（vector_out 是 push constant → 运行期均匀分支；veclen 不进
    //   key 的前提下按运行期形状选线程映射，一份 shader 服务任意 d_k）：
    //   路径 B（0 < vector_out ≤ 256）：**j 分片跨线程**——列 c = tid % vs、
    //     片号 g = tid / vs、本列线程数 GB = ceil((256-c)/vs)，片内按地板
    //     划分 [jlo, jhi) 精确覆盖 [0, valid)（ΣΔ⌊·⌋ = valid，恒等划分；
    //     片可为空、不重不漏）。旧映射 dd=tid 在 d_k=16 时只有 16/256 线程
    //     参战（半个 warp 单累加器长链 = fold ~57% 消融占比的根因），本路径
    //     256 线程全忙、每线程链长 = valid/GB（再按 VA_ACC 拆）；列间无共享，
    //     归约推迟到**块循环之后每行一次**（见下方收尾段）。
    //   路径 A（vector_out > 256）：保留 dd 步进分片（256 线程已全忙、V 读
    //     跨线程合并），仅把累加器 1 → VA_ACC 拆单链。
    //   两路径求和序均异于旧版左折叠 → GPU 字节锚移动（已立项批准）。
    if (f.vecacc)
    {
        const VecAccSpec& va = *f.vecacc;
        if (va.has_scale)
        {
            // 缩放覆盖（与初始化同口径，见行首双形态注释）：路径 B 缩放标量
            //   累加器（列与 tid 无关，旧 dd 步进覆盖不到）；路径 A 只缩放
            //   可达分片（与旧版一致 × VA_ACC），绝不对 16 槽全 tile 缩放
            L << "        if (vector_out > 0u && vector_out <= 256u) {\n";
            for (std::uint32_t t = 0; t < VA_ACC; ++t)
                L << "          ob" << t << " *= r" << static_cast<int>(va.scale_reg) << ";\n";
            L << "        } else if (vector_out > 256u) {\n";
            L << "          for (uint dd = tid; dd < vector_out; dd += 256u)\n";
            L << "            for (uint an = 0u; an < " << VA_ACC << "u; ++an)\n";
            L << "              o[(dd - tid) / 256u][an] *= r" << static_cast<int>(va.scale_reg)
              << ";\n";
            L << "        }\n";
        }
        // GQA：vecacc 的 b_input（V_t）行块号同样按其视图的头分组比取
        const std::string b_row =
            !has_mm ? std::string("0u") : gqa_blk_expr(spec, va.b_input, "(row / m_per)");
        // vecacc：O += Σ_j w(j)·b(j, d) —— 4 路软件流水。
        //   每拍同批发出 j..j+3 四个读使延迟重叠（GPU 无硬件预取，单发
        //   串行读会暴露 64 级 L2 延迟链——探针量化其占 fold 开销 55%）；
        //   四条独立累加语句保持 j 升序求和（组内求和顺序固定，与逐元素
        //   串行同序）。runtime valid 由尾循环兜余数；所有权/屏障/shared
        //   布局不动。
        L << "        const uint jr0 = " << b_row << " * fold_k + k0;\n";
        // 路径 B：j 分片（列/片/本列线程数均为运行期均匀量）
        L << "        if (vector_out > 0u && vector_out <= 256u) {\n";
        L << "          const uint cB = tid % vector_out;\n";
        L << "          const uint gB = tid / vector_out;\n";
        L << "          const uint GB = (256u - cB + vector_out - 1u) / vector_out;\n";
        L << "          const uint jlo = valid * gB / GB;\n";
        L << "          const uint jhi = valid * (gB + 1u) / GB;\n";
        L << "          uint j = jlo;\n";
        L << "          for (; j + " << VA_ACC << "u <= jhi; j += " << VA_ACC << "u) {\n";
        for (std::uint32_t t = 0; t < VA_ACC; ++t)
            L << "            const float v" << t << " = "
              << in_rd(va.b_input, "(jr0 + j + " + std::to_string(t) + "u) * vector_out + cB")
              << ";\n";
        for (std::uint32_t t = 0; t < VA_ACC; ++t)
            L << "            ob" << t << " += sreg[" << eidx[va.weight_reg] << "][j + " << t
              << "u] * v" << t << ";\n";
        L << "          }\n";
        // 尾段（余数 ≤ VA_ACC-1）：主循环出口 (j-jlo) ≡ 0 (mod VA_ACC) →
        //   按固定累加器序展开（标量无下标，零 dynamic-index）
        for (std::uint32_t t = 0; t < VA_ACC - 1u; ++t)
        {
            L << "          if (j < jhi) {\n";
            L << "            const float vj = " << in_rd(va.b_input, "(jr0 + j) * vector_out + cB")
              << ";\n";
            L << "            ob" << t << " += sreg[" << eidx[va.weight_reg] << "][j] * vj;\n";
            L << "            ++j;\n";
            L << "          }\n";
        }
        L << "        } else if (vector_out > 256u) {\n";
        // 路径 A：dd 步进分片 × VA_ACC 累加器（jlo=0 → 尾组 % VA_ACC）
        L << "          for (uint dd = tid; dd < vector_out; dd += 256u) {\n";
        L << "            uint j = 0u;\n";
        L << "            for (; j + " << VA_ACC << "u <= valid; j += " << VA_ACC << "u) {\n";
        for (std::uint32_t t = 0; t < VA_ACC; ++t)
            L << "              const float v" << t << " = "
              << in_rd(va.b_input, "(jr0 + j + " + std::to_string(t) + "u) * vector_out + dd")
              << ";\n";
        for (std::uint32_t t = 0; t < VA_ACC; ++t)
            L << "              o[(dd - tid) / 256u][" << t << "u] += sreg[" << eidx[va.weight_reg]
              << "][j + " << t << "u] * v" << t << ";\n";
        L << "            }\n";
        L << "            for (; j < valid; ++j)\n";
        L << "              o[(dd - tid) / 256u][j % " << VA_ACC << "u] += sreg["
          << eidx[va.weight_reg] << "][j] * " << in_rd(va.b_input, "(jr0 + j) * vector_out + dd")
          << ";\n";
        L << "          }\n";
        L << "        }\n";
    }
    L << "    }\n"; // 块循环尾

    // ── vecacc 收尾（k0 循环后、finalize 前；每行一次）──
    // ① 崩叠：路径 B = 标量累加器 ob 求和（热路径零数组访问，见行首双形态
    //    注释）；路径 A = 数组分片 [s] 内 VA_ACC 求和进 [0]；finalize 只读 [0]；
    // ② 路径 B 跨线程列归约：线程 tid（g=0 主）收集列 tid 的 GB 个分片部分和
    //    （槽 = 线程号；有 mm 段复用 spart，否则 sva）。最终值只回写本列主
    //    自己的 o[0][0]（每行一次），finalize 无线程间读。两次屏障仅在
    //    路径 B 且 vs<256 时出现（vs=256 → GB=1 免归约；路径 A 无屏障）。
    if (f.vecacc)
    {
        // 归约槽：spart[jm][grp] 的线性重解释（tid = jm + grp*BLOCK）
        constexpr std::uint32_t LG_SLOT = []()
        {
            std::uint32_t v = EXPR_FOLD_BLOCK, g = 0;
            while (v > 1)
            {
                v >>= 1;
                ++g;
            }
            return g;
        }();
        const auto slot = [&](const std::string& idx) -> std::string
        {
            if (has_mm)
                return "spart[(" + idx + ") & " + std::to_string(EXPR_FOLD_BLOCK - 1u) + "u][(" +
                       idx + ") >> " + std::to_string(LG_SLOT) + "u]";
            return "sva[" + idx + "]";
        };
        L << "\n        if (vector_out > 0u && vector_out <= 256u) {\n";
        L << "          const float pc = ob0";
        for (std::uint32_t t = 1; t < VA_ACC; ++t)
            L << " + ob" << t;
        L << ";\n";
        L << "          if (vector_out < 256u) {\n";
        L << "            " << slot("tid") << " = pc;\n";
        L << "            barrier();\n";
        L << "            if (tid < vector_out) {\n";
        L << "              float s = " << slot("tid") << ";\n";
        L << "              for (uint g = 1u; tid + g * vector_out < 256u; ++g) {\n";
        L << "                const uint si = tid + g * vector_out;\n";
        L << "                s += " << slot("si") << ";\n";
        L << "              }\n";
        L << "              o[0][0] = s;\n";
        L << "            }\n";
        L << "            barrier();   // 归约槽复用（下一行的 vecacc 重写）\n";
        L << "          } else {\n";
        L << "            o[0][0] = pc;\n";
        L << "          }\n";
        L << "        } else if (vector_out > 256u) {\n";
        L << "          for (uint s = 0u; s < " << OUTC_MAX << "u; ++s) {\n";
        L << "            o[s][0] = o[s][0]";
        for (std::uint32_t t = 1; t < VA_ACC; ++t)
            L << " + o[s][" << t << "u]";
        L << ";\n";
        L << "          }\n";
        L << "        }\n";
    }

    // ── finalize（向量域）：dd 步进分片逐列执行 → bout[row*vector_out + dd] ──
    L << "\n    for (uint dd = tid; dd < vector_out; dd += 256u) {\n";
    for (const auto& ins : f.finalize)
    {
        L << emit_assign(ins, "r" + std::to_string(ins.dst), 'F', "dd");
    }
    if (disp)
    {
        L << "      if (row_ok) {\n";
        L << "        if ((prec >> 16u & 1u) != 0u)\n";
        L << "          bout16[row * vector_out + dd] = "
          << glsl_f16_store("r" + std::to_string(static_cast<int>(f.finalize.back().dst))) << ";\n";
        L << "        else\n";
        L << "          bout[row * vector_out + dd] = r" << static_cast<int>(f.finalize.back().dst)
          << ";\n";
        L << "      }\n";
    }
    else
        L << "      if (row_ok) bout[row * vector_out + dd] = "
          << (out_f16
                  ? glsl_f16_store("r" + std::to_string(static_cast<int>(f.finalize.back().dst)))
                  : ("r" + std::to_string(static_cast<int>(f.finalize.back().dst))))
          << ";\n"; // 越界 ri 不写回
    L << "    }\n";
    L << "    }\n"; // NR 行循环尾
    L << "}\n";
    return L.str();
}

// ── 每个结构的三份产物（sig 语义见 expr_spec.hpp）────────────────────────
//   sig == 0 → **V0** 全 f32（键 = 结构 key）。
//   sig == EXPR_PREC_SIG_DISPATCH → **V1 运行期精度分派**（键 = key#x）：每个
//        输入/输出声明 f32 + float16_t **双视图**，加载/存储按 PC `prec` 选一。
//        一份 shader 覆盖任意 (输入位图, 输出) 签名——精度是**参数**不是身份，
//        故构建期无需枚举签名。算术仍在 f32。
//   sig != 0（真实位图）+ native16=false → **V2 存储变体**：该精度上是 f16 的
//        槽声明为 float16_t（GL_EXT_shader_16bit_storage + 显式
//        float(...)/float16_t(...) 转换），算术仍在 f32（§7.2：f32 参考 +
//        输出舍入）→ 读一次 2B、写一次 2B，无需"边界 cast"为每个算子物化
//        f32 副本（边界 cast 路径会使 transient 膨胀 2.4×）。
//   native16=true → **V2b 原生 f16 算术**（键 = key#a；仅当谓词
//        expr_prec_sig_native16 通过才生成）：全链 float16_t 计算
//        （GL_EXT_shader_explicit_arithmetic_types_float16），无
//        load→float()→f32 算术→float16_t() 的逐元素往返。后端按设备
//        shaderFloat16 能力选 pipeline；谓词不通过 → 本函数返回空串，上层不产出
//        `#a` 条目，运行时落 `#x`（或设备的边界 cast）。
// 形态覆盖：纯逐元素、前置 matmul 段、fold 段（v1/v2）、归约 kernel
// （generate_glsl_reduce，读写点按 sig 转换）。仍返回空串的情形：归约混合轴
// （== -2）、归约槽过多（>8）等 → 上层跳过该变体，运行时回退，正确性不受影响。
// batched=true → **P3 批量变体**（键 = key#b）：同结构多实例一次派发——
//      缓冲声明改为"实例表 + buffer reference + 名字宏"、main 序言按
//      gl_WorkGroupID.y 取实例、强制标量路径；PC 布局与 V0 完全一致。
//      仅纯逐元素（expr_spec_batchable）+ V0 全 f32，其余返回空串。
// mm_fine=true → **matmul 细 tile 变体**（键 = key#f，P0 wgrad 网格饥饿）：
//      输出块 64×64 → 16×16 的同结构 shader。仅纯 matmul 形态
//      （spec.matmul、无 fold、raxis<0、V0 全 f32），其余返回空串 →
//      构建期不产出条目、运行期留在 64-tile 路径（降级，不是错误）。
// mm_ksplit=true → **matmul K 切分变体**（键 = key#ks，二次归约）：
//      细 tile 网格上再把 K 切成 S 段（每 WG 一段 → 部分和，不跑尾链）。
//      资格与 #f 同源（纯 matmul、V0 全 f32），其余返回空串 → 上层 [skip]、
//      运行期留细 tile 路径（降级，不是错误）。伴生归约（#kr）不经本入口，
//      由 GlslEmitter 直调 generate_glsl_matmul_ksplit_reduce。
//
// native16 恒走**标量 kernel**（vec4 的 f16vec4 向量化路径留作后续优化）——
// 对应变体的 FusedShader.vec_width 必须为 1（fused_generate.hpp 同源判定）。
inline std::string generate_glsl(const std::string& name, const ExprSpec& spec, ExprPrecSig sig = 0,
                                 bool native16 = false, bool batched = false, bool mm_fine = false,
                                 bool mm_ksplit = false)
{
    // P3 批量变体（键 = key#b）：纯逐元素 + 仅 V0 全 f32。其余形态返回空串
    // （上层 [skip]，运行期逐 kernel 降级，不是错误）。资格判据与
    // fused_generate / execute_fused_graph 同源（expr_spec_batchable）。
    // 批量变体（键 = key#b，或叠加在精度特化变体上 = key#xxxx#b）：
    // 资格同 V0（纯逐元素、无 fold/matmul/reduce）；sig 为静态签名（0 = V0）。
    // ⚠ **带 extras 的结构仅支持 V0 全 f32**：extras 的元素类型不在
    //   ExprPrecSig 里（它只描述输入 + 主输出），运行期又无法在构建期枚举，
    //   故 f16 批量变体只对 **extras 为空**的结构发射（实测优化器在 f16 下的
    //   4 个结构全是单输出 → 覆盖到）；带 extras 的 f16 结构仍逐 kernel 降级。
    //   运行期分派哨兵不叠加批量变体。
    if (batched && (expr_prec_sig_is_dispatch(sig) || native16 || !expr_spec_batchable(spec) ||
                    (sig != 0 && !spec.extras.empty())))
        return {};
    if (mm_fine)
    {
        // 细 tile 变体（键 = key#f；**可叠加**在精度特化变体上 = key#xxxx#f）。
        // 资格与 run_fused_gpu 的派发分支同源（纯 matmul：无 fold、raxis<0）。
        // PC 布局与 V0 完全一致（block 不进 PC）→ 同一固定头、同一绑定数，
        // 所以 sig 只是把"输入/输出读写的元素类型"静态化，不引入新槽。
        // 运行期分派哨兵不支持（它多一个 `prec` 槽且绑定翻倍，网格变体不叠加）。
        if (expr_prec_sig_is_dispatch(sig) || native16 || batched || spec.fold || !spec.matmul ||
            expr_spec_reduce_axis(spec) != -1)
            return {};
        return generate_glsl_matmul(name, spec, sig, EXPR_MATMUL_BLOCK_FINE);
    }
    if (mm_ksplit)
    {
        // K 切分变体（键 = key#ks）：资格与 run_fused_gpu 的 K 切分派发
        // 分支同源（纯 matmul：无 fold、raxis<0）。block 恒取细 tile 16
        //（K 切分只在细 tile 网格仍饥饿时派发）；PC 比 V0 多一槽 ks_span
        //（见 generate_glsl_matmul 的 k_split 分支）。sig 同上：0 = V0，
        // 具体签名 = 静态特化变体（**部分和缓冲恒 f32**，与 sig 输出精度无关）。
        if (expr_prec_sig_is_dispatch(sig) || native16 || batched || spec.fold || !spec.matmul ||
            expr_spec_reduce_axis(spec) != -1)
            return {};
        return generate_glsl_matmul(name, spec, sig, EXPR_MATMUL_BLOCK_FINE, /*k_split=*/true);
    }
    if (native16 && !expr_prec_sig_native16(spec, sig)) return {};
    if (sig != 0)
    {
        // 本函数只处理非归约形态（带归约轴的 spec 由 gen_fused 按 raxis 路由到
        // generate_glsl_reduce）；带归约的 spec 误入本路径时防御性返回空串
        // （上层跳过该变体，运行时回退边界 cast，正确性不受影响）。
        if (!spec.fold && expr_spec_reduce_axis(spec) != -1) return {};
    }
    // fold 段：双域形态（向量态/mm 段）走 v2，纯标量走 v1
    if (spec.fold)
        return (spec.fold->vec_state_len > 0 || spec.fold->matmul)
                   ? generate_glsl_fold_v2(name, spec, sig)
                   : generate_glsl_fold(name, spec, sig);
    // 含前置 matmul 段：matmul + 尾逐元素链融合 shader
    if (spec.matmul) return generate_glsl_matmul(name, spec, sig);

    const std::size_t n_inputs = spec.views.size();
    const bool disp = expr_prec_sig_is_dispatch(sig);
    // P2 多输出（extras，IR-C 写穿物化）：仅 V0（全 f32）生成——`#x` 分派/
    // typed/native16 变体跳过（返回空串 = 上层 [skip]，该结构运行时只走 V0；
    // 多输出节点同精度融合由 fuse_expr_graph 的精度门禁保证）。
    if (!spec.extras.empty() && (disp || sig != 0 || native16)) return {};
    std::ostringstream L;
    const auto in_type = [&](std::size_t i) -> const char*
    { return (sig != 0 && expr_prec_sig_in_f16(sig, i)) ? "float16_t" : "float"; };
    const bool out_f16 = sig != 0 && expr_prec_sig_out_f16(sig);
    const bool any_f16 = sig != 0;

    L << "// ── 自动生成（AOT 算子融合），请勿手动编辑 ──\n";
    L << "// 表达式: " << name;
    if (sig != 0 && !disp) L << "   [精度 " << expr_prec_sig_str(sig, n_inputs) << "]";
    else if (disp) L << "   [运行期精度分派]";
    else if (batched) L << "   [批量 #b：实例表 + buffer device address]";
    L << "\n";
    L << "#version 450\n\n";
    if (batched)
        // buffer reference（P3 实例表按 64 位设备地址解引用输入/输出缓冲）；
        // uvec2 槽位 → reference 的构造另需 GL_EXT_buffer_reference_uvec2
        // （glslc 强制，缺则 "required extension not requested"）。
        L << "#extension GL_EXT_buffer_reference : require\n"
             "#extension GL_EXT_buffer_reference_uvec2 : require\n\n";
    if (any_f16) L << "#extension GL_EXT_shader_16bit_storage : require\n\n";
    if (native16)
        // f16 算术扩展（float16_t 类型的 +,-,*,/,exp,log,... 与 f16vecN）；
        // 与 16bit_storage 同时声明（spike 验证两者共存可编译）。
        L << "#extension GL_EXT_shader_explicit_arithmetic_types_float16 : require\n\n";
    if (any_f16) L << glsl_f16_rne_source();
    L << "layout(local_size_x = 256) in;\n\n";

    // 逐输入/输出的存储类型
    if (batched)
    {
        // ── P3 批量变体缓冲声明：实例表 + buffer reference + 名字宏 ──────
        // 实例记录布局（uvec2 数组，stride **S = n_inputs + 1 + n_extras + 1**，
        // 每实例一段，实例下标 = gl_WorkGroupID.y）：
        //   槽 [0, n_inputs)               第 j 个输入缓冲的设备地址（b<j>）
        //   槽 n_inputs                    主输出缓冲地址（bout）
        //   槽 [n_inputs+1, +n_extras)     extras 输出地址（bex<k>，成员序）
        //   槽 S-1 = (count, cols)         尾槽：本实例元素数 + 本实例列数
        // 尾槽 y 分量即每实例列数（`#define cols` 见 PC 块后）：批量组键与
        // rows/cols 无关（同组形状可不同），列数必须随实例走，不能用 PC 的
        // 单一 cols 槽。宏把普通版的缓冲名 b<i>/bout/bex<k> 映射到"实例 ib
        // 的第 j 槽地址"——视图读取（glsl_view_read）与输出写回的渲染与普通
        // 版逐字一致（RowGather 的 b<param> 标签槽同样覆盖）。
        // `ib` 必须是模块级变量：gr_r<i> 辅助函数也经宏访问实例表。
        L << "// P3 批量派发：实例表槽位 = 输入…、输出…、(count,cols)；"
             "stride S = "
          << (n_inputs + 2 + spec.extras.size()) << "\n";
        // 实例表的地址是类型无关的；元素类型由**注入签名**在编译期定死
        //（f16 槽走 float16_t 的 buffer reference）。extras 只在 sig==0
        //（V0）时存在 → 其引用类型恒 F32BufW（见上方资格拒绝）。
        const bool b_sign_f16 = (sig != 0);
        const bool b_out_f16 = b_sign_f16 && expr_prec_sig_out_f16(sig);
        L << "layout(buffer_reference, std430) readonly buffer F32BufR "
             "{ float d[]; };\n";
        if (b_sign_f16)
            L << "layout(buffer_reference, std430) readonly buffer F16BufR "
                 "{ float16_t d[]; };\n";
        L << "layout(buffer_reference, std430) buffer F32BufW "
             "{ float d[]; };\n";
        if (b_out_f16)
            L << "layout(buffer_reference, std430) buffer F16BufW "
                 "{ float16_t d[]; };\n";
        L << "layout(std430, binding = 0) readonly buffer Inst "
             "{ uvec2 inst[]; };\n";
        L << "uint ib;   // 模块级 per-invocation 私有（gr_r<> 辅助函数也用）\n";
        for (std::size_t i = 0; i < n_inputs; ++i)
            L << "#define b" << i << " ("
              << ((b_sign_f16 && expr_prec_sig_in_f16(sig, i)) ? "F16BufR" : "F32BufR")
              << "(inst[ib + " << i << "u]).d)\n";
        L << "#define bout (" << (b_out_f16 ? "F16BufW" : "F32BufW") << "(inst[ib + " << n_inputs
          << "u]).d)\n";
        for (std::size_t k = 0; k < spec.extras.size(); ++k)
            L << "#define bex" << k << " (F32BufW(inst[ib + " << (n_inputs + 1 + k) << "u]).d)\n";
        L << "\n";
    }
    else
    {
        // 非批量：per-binding 声明（发射文本与历史逐字一致）
        for (std::size_t i = 0; i < n_inputs; ++i)
        {
            L << "layout(std430, binding = " << i << ") readonly buffer Buf" << i << " { "
              << (disp ? "float" : in_type(i)) << " b" << i << "[]; };\n";
            if (disp)
                L << "layout(std430, binding = " << (n_inputs + i) << ") readonly buffer Buf" << i
                  << "h { float16_t b" << i << "h[]; };\n";
        }
        if (disp)
        {
            L << "layout(std430, binding = " << (2 * n_inputs)
              << ") writeonly buffer BufOut { float bout[]; };\n";
            L << "layout(std430, binding = " << (2 * n_inputs + 1)
              << ") writeonly buffer BufOuth { float16_t bout16[]; };\n\n";
        }
        else
        {
            L << "layout(std430, binding = " << n_inputs << ") writeonly buffer BufOut { "
              << (out_f16 ? "float16_t" : "float") << " bout[]; };\n";
            // P2 多输出：额外输出缓冲（V0 专属，类型恒 float——sig==0 ⇒ out_f16=0）
            for (std::size_t k = 0; k < spec.extras.size(); ++k)
                L << "layout(std430, binding = " << (n_inputs + 1 + k)
                  << ") writeonly buffer BufOut" << (k + 1) << " { float bex" << k << "[]; };\n";
            L << "\n";
        }
    }

    // push constants：count + cols（视图行/列）+ [prec] + 运行时视图参数 vp + 常量
    L << "layout(push_constant) uniform PC {\n";
    L << "    uint count;\n";
    L << "    uint cols;\n";
    if (disp)
        L << "    uint prec;   // 运行期精度分派位：bit i = 输入 i 为 f16，"
             "bit16 = 输出为 f16\n";
    const std::uint32_t n_vp = expr_spec_runtime_view_param_count(spec);
    for (std::uint32_t i = 0; i < n_vp; ++i)
        L << "    uint vp" << i << ";\n";
    for (std::size_t i = 0; i < spec.consts.size(); ++i)
        L << "    float c" << i << ";\n";
    const std::uint32_t n_rp = static_cast<std::uint32_t>(spec.rparams.size());
    for (std::uint32_t i = 0; i < n_rp; ++i)
        L << "    float rp" << i << ";\n";
    L << "};\n\n";

    if (batched)
    {
        // 每实例列数：实例表尾槽 (count, cols) 的 y 分量。同组实例形状可不同
        // （批量组键与 rows/cols 无关），故主体与 gr_r<i> 辅助函数里的 `cols`
        // 一律取本实例值——宏放在 PC 块之后（PC 布局与 V0 逐字一致，批量路径
        // 不读其 count/cols 两槽）、辅助函数之前（它们也用 `cols`）。
        L << "#define cols ((inst[ib + " << (n_inputs + 1 + spec.extras.size()) << "u]).y)\n\n";
    }

    // 分组归约视图（MaxPool 等）的读取辅助函数：R 是运行期 vp 参数 → 循环。
    // 与 glsl_view_read 的 GroupedReduceSum/Max 分支成对（编译器把 `gr_r<i>`
    // 调用点连到这里；漏发 = 未声明函数，glslc 立刻报错而非静默错值）。
    glsl_emit_grouped_reduce_helpers(L, spec, sig, native16);

    // native16 恒走标量 kernel（f16vec4 向量化路径留作后续优化）——
    // vec_width 元数据必须同源为 1（gen_fused 对 ALU 变体同判，否则
    // dispatch 按 4 宽派发而 kernel 按 1 宽算 → 静默只算 1/4 元素）。
    // 批量变体同理恒标量（实例表按元素下标派发，无 vec4 快路径）。
    const bool vec4_ok = glsl_vec4_eligible(spec) && !native16 && !batched;
    // 索引操作数（Row/Col/Batch）也按需发射 row/col/batch 变量
    const auto instr_uses = [&](uint8_t kind)
    {
        for (const auto& ins : spec.instrs)
        {
            const ExprOperand* ops[3] = {&ins.a, &ins.b, &ins.c};
            const std::size_t nops = expr_instr_num_operands(static_cast<ExprOp>(ins.op));
            for (std::size_t oi = 0; oi < nops; ++oi)
                if (ops[oi]->kind == kind) return true;
        }
        return false;
    };
    const bool need_row = [&]
    {
        for (const auto& v : spec.views)
            if (glsl_view_uses_row(static_cast<ExprViewKind>(v.kind))) return true;
        return instr_uses(static_cast<uint8_t>(ExprOperandKind::Row));
    }();
    const bool need_col = [&]
    {
        for (const auto& v : spec.views)
            if (glsl_view_uses_col(static_cast<ExprViewKind>(v.kind))) return true;
        return instr_uses(static_cast<uint8_t>(ExprOperandKind::Col));
    }();
    const bool need_batch = glsl_spec_uses_batch(spec);
    const std::uint32_t last_dst = spec.instrs.back().dst;

    // ── 标量操作数求值 ──
    const auto operand = [&](const ExprOperand& op) -> std::string
    {
        switch (op.kind)
        {
        default:
        case static_cast<uint8_t>(ExprOperandKind::Input):
            return "v" + std::to_string(op.idx);
        case static_cast<uint8_t>(ExprOperandKind::Reg):
        case static_cast<uint8_t>(ExprOperandKind::Fanout): // Fanout 语义同 Reg
            return "r" + std::to_string(op.idx);
        case static_cast<uint8_t>(ExprOperandKind::Const):
            // native16：常量按 float 推入 push constant，用点显式收 f16——
            // f16 寄存器 = float 表达式是隐式收窄（glslc 拒绝）。收窄走
            // glsl_f16_store（RNE）——与输出写回同一舍入口径，否则常量型
            // 乘法因子（如 p *= c）会在 native16 下每步掉 1 个网格步。
            return native16 ? glsl_f16_store("c" + std::to_string(op.idx))
                            : ("c" + std::to_string(op.idx));
        case static_cast<uint8_t>(ExprOperandKind::RParam):
            // native16 谓词已排除 rparams（微小标量 flush-to-0 隐患），
            // 此处仍发 f16 包装作纵深防御（若未来谓词放开则不至于类型错）
            return native16 ? glsl_f16_store("rp" + std::to_string(op.idx))
                            : ("rp" + std::to_string(op.idx));
        // 索引操作数：当前网格下标（uint → float 参与算术）
        // 注：native16 谓词已排除 Row/Col/Batch 值操作数（f16 整数精度），
        // 分支保留给 f32 算术变体；若谓词漏网此处会以 float 混入 f16 链
        // 触发 glslc 类型错误（构建期暴露，不会静默错值）。
        case static_cast<uint8_t>(ExprOperandKind::Row):
            return "float(row)";
        case static_cast<uint8_t>(ExprOperandKind::Col):
            return "float(col)";
        case static_cast<uint8_t>(ExprOperandKind::Batch):
            return "float(batch)";
        }
    };

    // 发射一段标量指令链（输入读取 + 寄存器声明 + 指令展开，直线代码；
    // 寄存器先声明、后赋值——兼容 IR-B liveness 复用同号寄存器）。
    // idx_var：扁平元素索引；row_var/col_var：行/列索引表达式（可为 "i/cols" 等）。
    const auto emit_scalar_chain = [&](std::ostringstream& o, const std::string& indent,
                                       const std::string& idx_var, const std::string& row_var,
                                       const std::string& col_var)
    {
        // 输入读取变量（每输入缓存一次）；vp 槽见 glsl_vp_slot
        for (std::size_t i = 0; i < n_inputs; ++i)
        {
            const std::uint32_t vp = glsl_vp_slot(spec, i);
            // native16：读取直接产出 float16_t（谓词保证全部输入 f16，故
            // 无 float() 包装——全链 f16，无逐元素往返）；f32 算术变体保持原样。
            o << indent << "const " << (native16 ? "float16_t" : "float") << " v" << i << " = ";
            const bool f16_in = (sig != 0 && expr_prec_sig_in_f16(sig, i));
            if (f16_in && !native16) o << "float("; // f16 读 → 显式转 f32（算术仍在 f32）
            glsl_view_read(o, spec.views[i], static_cast<std::uint32_t>(i), idx_var, row_var,
                           col_var, vp, sig, native16);
            if (f16_in && !native16) o << ")";
            o << ";\n";
        }
        if (spec.num_regs > 0)
        {
            o << indent << (native16 ? "float16_t r0" : "float r0");
            for (std::uint32_t r = 1; r < spec.num_regs; ++r)
                o << ", r" << r;
            o << ";\n";
        }
        for (const auto& ins : spec.instrs)
        {
            const ExprOp op = static_cast<ExprOp>(ins.op);
            const std::string dst = "r" + std::to_string(ins.dst);
            const std::string a = operand(ins.a);
            const detail::ExprOpInfo& info = detail::expr_op_info(op);
            if (info.emit == detail::ExprEmitKind::None) return; // 未知算子：让上层报错
            // 发射形态/符号查表；0/1 字面量按目标寄存器类型发射（f16 寄存器
            //   不能隐式收窄 float）——由 native16 控制
            o << indent << dst << " = "
              << glsl_alu_expr(
                     info, a, [&] { return operand(ins.b); }, [&] { return operand(ins.c); },
                     /*vec4=*/false, native16, /*wrap=*/false)
              << ";\n";
        }
    };

    if (!vec4_ok)
    {
        // ── 纯标量 kernel（含 RowMod/RotateHalf 等无法向量化的视图）──
        L << "void main()\n{\n";
        if (batched)
        {
            // 批量序言：实例下标 = gl_WorkGroupID.y，元素数取本实例尾槽；
            // 此后 row/col/batch 推导与指令链与普通版逐字一致（`cols` 经宏
            // 取本实例值）。dispatch = (ceil(max_count/256), n_instances, 1)。
            L << "    const uint S = " << (n_inputs + 2 + spec.extras.size())
              << "u;   // uvec2 槽位数：输入…、输出…、(count,cols)\n";
            L << "    ib = gl_WorkGroupID.y * S;\n";
            L << "    const uint count_l = inst[ib + S - 1u].x;\n";
            L << "    const uint i = gl_GlobalInvocationID.x;\n";
            L << "    if (i >= count_l) return;\n";
        }
        else
        {
            L << "    const uint i = gl_GlobalInvocationID.x;\n";
            L << "    if (i >= count) return;\n";
        }
        if (need_row && need_col)
            L << "    const uint row = i / cols;\n    const uint col = i % cols;\n";
        else if (need_row) L << "    const uint row = i / cols;\n";
        else if (need_col) L << "    const uint col = i % cols;\n";
        if (need_batch) L << "    const uint batch = 0u;\n";
        emit_scalar_chain(L, "    ", "i", need_row ? "row" : "", need_col ? "col" : "");
        // native16：寄存器本就是 float16_t → 直写（免冗余 float16_t() 转换）
        if (native16) L << "    bout[i] = r" << last_dst << ";\n";
        else if (disp)
        {
            L << "    if ((prec >> 16u & 1u) != 0u) {\n";
            L << "        bout16[i] = " << glsl_f16_store("r" + std::to_string(last_dst)) << ";\n";
            L << "    } else {\n";
            L << "        bout[i] = r" << last_dst << ";\n";
            L << "    }\n";
        }
        else
            L << "    bout[i] = "
              << (out_f16 ? glsl_f16_store("r" + std::to_string(last_dst))
                          : ("r" + std::to_string(last_dst)))
              << ";\n";
        // P2 多输出：额外输出寄存器同元素写各自的输出缓冲（V0 专属）
        for (std::size_t k = 0; k < spec.extras.size(); ++k)
            L << "    bex" << k << "[i] = r" << static_cast<int>(spec.extras[k]) << ";\n";
        L << "}\n";
        return L.str();
    }

    // ── vec4 kernel：每线程处理 4 个相邻元素 ────────────────────────────
    // 快速路径（cols%4==0 且组内 4 元素齐全）→ vec4 加载/运算/存储；
    // 否则回退到同 kernel 内标量循环（任意 cols / 尾部）。dispatch 宽度 4。
    L << "void main()\n{\n";
    L << "    const uint i = gl_GlobalInvocationID.x;\n";
    L << "    const uint base = i * 4u;\n";
    L << "    if (base >= count) return;\n";
    L << "    if (cols % 4u == 0u && base + 3u < count) {\n";
    if (need_row && need_col)
        L << "        const uint row = base / cols;\n        const uint col0 = base % cols;\n";
    else if (need_row) L << "        const uint row = base / cols;\n";
    else if (need_col) L << "        const uint col0 = base % cols;\n";

    // vec4 输入读取（Linear/ColBroadcast 相邻 4 元素 → glslc 合并为 vec4 加载；
    // RowBroadcast → splat）
    for (std::size_t i = 0; i < n_inputs; ++i)
    {
        const auto k = static_cast<ExprViewKind>(spec.views[i].kind);
        const std::string cvt = (sig != 0 && expr_prec_sig_in_f16(sig, i)) ? "float" : "";
        const auto ld = [&](const std::string& idx)
        {
            const std::string bf = "b" + std::to_string(i) + "[" + idx + "]";
            if (disp)
                return "((prec >> " + std::to_string(i) + "u & 1u) != 0u ? float(b" +
                       std::to_string(i) + "h[" + idx + "]) : " + bf + ")";
            return cvt.empty() ? bf : ("float(" + bf + ")");
        };
        if (k == ExprViewKind::Linear)
            L << "        const vec4 v" << i << " = vec4(" << ld("base") << ", " << ld("base+1u")
              << ", " << ld("base+2u") << ", " << ld("base+3u") << ");\n";
        else if (k == ExprViewKind::RowBroadcast)
            L << "        const vec4 v" << i << " = vec4(" << ld("row") << ");\n";
        else // ColBroadcast
            L << "        const vec4 v" << i << " = vec4(" << ld("col0") << ", " << ld("col0+1u")
              << ", " << ld("col0+2u") << ", " << ld("col0+3u") << ");\n";
    }

    // vec4 指令展开（GLSL 对 vec4 重载运算/内置函数；常量广播为 vec4）
    const auto vec4_operand = [&](const ExprOperand& op) -> std::string
    {
        switch (op.kind)
        {
        default:
        case static_cast<uint8_t>(ExprOperandKind::Input):
            return "v" + std::to_string(op.idx);
        case static_cast<uint8_t>(ExprOperandKind::Reg):
        case static_cast<uint8_t>(ExprOperandKind::Fanout):
            return "r" + std::to_string(op.idx);
        case static_cast<uint8_t>(ExprOperandKind::Const):
            return "vec4(c" + std::to_string(op.idx) + ")";
        case static_cast<uint8_t>(ExprOperandKind::RParam):
            return "vec4(rp" + std::to_string(op.idx) + ")";
        }
    };
    if (spec.num_regs > 0)
    {
        L << "        vec4 r0";
        for (std::uint32_t r = 1; r < spec.num_regs; ++r)
            L << ", r" << r;
        L << ";\n";
    }
    for (const auto& ins : spec.instrs)
    {
        const ExprOp op = static_cast<ExprOp>(ins.op);
        const std::string dst = "r" + std::to_string(ins.dst);
        const std::string a = vec4_operand(ins.a);
        const detail::ExprOpInfo& info = detail::expr_op_info(op);
        if (info.emit == detail::ExprEmitKind::None) return std::string{}; // 未知算子：让上层报错
        // 发射形态/符号查表；向量形态：比较用向量内建、Select 用 mix/notEqual
        L << "        " << dst << " = "
          << glsl_alu_expr(
                 info, a, [&] { return vec4_operand(ins.b); }, [&] { return vec4_operand(ins.c); },
                 /*vec4=*/true, /*native16=*/false, /*wrap=*/false)
          << ";\n";
    }
    // 运行期精度分派：输出双视图 + uniform 存储分支（每元素只写一次，
    // 两侧视图按各自的元素宽度寻址，无别名风险）。
    // 输出类型转换由本 lambda 统一负责（c16）——此前另有一个 st() 也包
    // float16_t(...)，在"非分派 + f16 输出"上生成 float16_t(float16_t(x))。
    const auto emit_store4 = [&](const char* arr, bool c16, const char* ind)
    {
        const std::string r = "r" + std::to_string(last_dst);
        const auto val = [&](char comp)
        {
            const std::string v = r + "." + comp;
            return c16 ? glsl_f16_store(v) : v;
        };
        L << ind << arr << "[base] = " << val('x') << ";\n";
        L << ind << arr << "[base+1u] = " << val('y') << ";\n";
        L << ind << arr << "[base+2u] = " << val('z') << ";\n";
        L << ind << arr << "[base+3u] = " << val('w') << ";\n";
    };
    if (disp)
    {
        L << "        if ((prec >> 16u & 1u) != 0u) {\n";
        emit_store4("bout16", true, "            ");
        L << "        } else {\n";
        emit_store4("bout", false, "            ");
        L << "        }\n";
    }
    else emit_store4("bout", out_f16, "        ");
    // P2 多输出：vec4 快路径按分量写额外输出缓冲
    for (std::size_t k = 0; k < spec.extras.size(); ++k)
    {
        const std::string rx = "r" + std::to_string(static_cast<int>(spec.extras[k]));
        L << "        bex" << k << "[base] = " << rx << ".x;\n";
        L << "        bex" << k << "[base+1u] = " << rx << ".y;\n";
        L << "        bex" << k << "[base+2u] = " << rx << ".z;\n";
        L << "        bex" << k << "[base+3u] = " << rx << ".w;\n";
    }
    L << "        return;\n";
    L << "    }\n";

    // 标量回退：处理本线程负责的至多 4 个元素（任意 cols / 尾部）
    L << "    for (uint e = base; e < count && e < base + 4u; ++e) {\n";
    if (need_row && need_col)
        L << "        const uint row = e / cols;\n        const uint col = e % cols;\n";
    else if (need_row) L << "        const uint row = e / cols;\n";
    else if (need_col) L << "        const uint col = e % cols;\n";
    if (need_batch) L << "        const uint batch = 0u;\n";
    emit_scalar_chain(L, "        ", "e", need_row ? "row" : "", need_col ? "col" : "");
    const std::string sv = "r" + std::to_string(last_dst);
    if (disp)
    {
        L << "        if ((prec >> 16u & 1u) != 0u) {\n";
        L << "            bout16[e] = " << glsl_f16_store(sv) << ";\n";
        L << "        } else {\n";
        L << "            bout[e] = " << sv << ";\n";
        L << "        }\n";
    }
    else L << "        bout[e] = " << (out_f16 ? glsl_f16_store(sv) : sv) << ";\n";
    // P2 多输出：标量回退路径同元素写额外输出缓冲（此处 rN 为标量）
    for (std::size_t k = 0; k < spec.extras.size(); ++k)
        L << "        bex" << k << "[e] = r" << static_cast<int>(spec.extras[k]) << ";\n";
    L << "    }\n";
    L << "}\n";
    return L.str();
}

// ═══════════════════════════════════════════════════════════════════════════
//  归约融合 shader 生成：含归约视图/归约指令的表达式
//
//  处理 expr_spec_reduce_axis(spec) >= 0 的表达式（全部归约同轴）：
//    - 工作组级归约：每个工作组（256 线程）协作处理一行（行归约）或一列
//      （列归约），shared memory 树形归约，随后输出该行/列的全部元素。
//    - 布局：bindings 输入 0..N-1 + 输出 N；
//      push constants: uint count, uint cols, uint rows, [float c0..]；
//      dispatch: 行归约 (rows,1,1)，列归约 (cols,1,1)。
//    - 归约槽：每个归约视图/归约指令占一个共享槽 s_red[slot][256]；
//      归约视图经 Input 操作数（槽），归约指令经 Reduce 操作数（槽）访问，
//      最终值读取 s_red[slot][0]（完成屏障后全线程可见）。
//    - 限制：归约槽 ≤ 8（共享内存 ≤ 8KB）；混合轴（行+列）不支持 → 返回 ""。
// ═══════════════════════════════════════════════════════════════════════════
[[nodiscard]] inline std::string generate_glsl_reduce(const std::string& name, const ExprSpec& spec,
                                                      ExprPrecSig sig = 0)
{
    const int axis = expr_spec_reduce_axis(spec);
    if (axis < 0) return {}; // 无归约（走逐元素生成器）或混合轴（不支持）
    const bool is_row = (axis == 0);

    const std::size_t n_inputs = spec.views.size();

    // ── 归约槽分配 ──
    // slot_of_view[k]：归约视图 k → 槽号；slot_of_instr[dst]：归约指令 dst → 槽号
    std::vector<int> slot_of_view(n_inputs, -1);
    std::vector<int> slot_of_instr(EXPR_MAX_REGS, -1);
    std::vector<bool> slot_is_max;
    int n_slots = 0;
    for (std::size_t k = 0; k < n_inputs; ++k)
    {
        const ExprView& v = spec.views[k];
        if (!expr_view_is_reduce(static_cast<ExprViewKind>(v.kind))) continue;
        slot_of_view[k] = n_slots++;
        slot_is_max.push_back(static_cast<ExprViewKind>(v.kind) == ExprViewKind::RowReduceMax ||
                              static_cast<ExprViewKind>(v.kind) == ExprViewKind::ColReduceMax);
    }
    for (const auto& ins : spec.instrs)
    {
        const ExprOp op = static_cast<ExprOp>(ins.op);
        if (!expr_op_is_reduce(op)) continue;
        slot_of_instr[ins.dst] = n_slots++;
        slot_is_max.push_back(op == ExprOp::RowMax || op == ExprOp::ColMax);
    }
    if (n_slots == 0 || n_slots > 8) return {}; // 无归约或槽过多（共享内存超限）

    const bool last_is_reduce = expr_op_is_reduce(static_cast<ExprOp>(spec.instrs.back().op));

    // ── 带类型变体（Phase 2 in-kernel f16）───────────────────────────────
    // sig==0 → 全 f32：生成的就是 f32 变体源码。sig!=0 → 对应槽的
    // 缓冲区声明为 float16_t，读取处统一 float(...) 转 f32（累加/合并/尾链
    // 全在 f32，符合 §7.2），输出写回按 out 位 float16_t(...)。
    const bool sign_f16 = (sig != 0);
    const bool disp = expr_prec_sig_is_dispatch(sig);
    const bool out_f16 = sign_f16 && expr_prec_sig_out_f16(sig);
    const auto rd = [&](std::size_t k, const std::string& idx) -> std::string
    {
        const std::string raw = "b" + std::to_string(k) + "[" + idx + "]";
        if (disp)
            return "((prec >> " + std::to_string(k) + "u & 1u) != 0u ? float(b" +
                   std::to_string(k) + "h[" + idx + "]) : " + raw + ")";
        return (sign_f16 && expr_prec_sig_in_f16(sig, k)) ? ("float(" + raw + ")") : raw;
    };
    const auto wr = [&](const std::string& v) -> std::string
    { return out_f16 ? glsl_f16_store(v) : v; };

    std::ostringstream L;
    L << "// ── 自动生成（AOT 算子融合 · 归约 kernel），请勿手动编辑 ──\n";
    L << "// 表达式: " << name;
    if (sign_f16 && !disp) L << "   [精度 " << expr_prec_sig_str(sig, n_inputs) << "]";
    else if (disp) L << "   [运行期精度分派]";
    L << "\n";
    L << "#version 450\n";
    L << "#extension GL_KHR_shader_subgroup_basic : enable\n";
    L << "#extension GL_KHR_shader_subgroup_arithmetic : enable\n";
    if (sign_f16) L << "#extension GL_EXT_shader_16bit_storage : require\n";
    L << "\n";
    if (sign_f16) L << glsl_f16_rne_source();
    L << "layout(local_size_x = 256) in;\n\n";
    for (std::size_t i = 0; i < n_inputs; ++i)
    {
        L << "layout(std430, binding = " << i << ") readonly buffer Buf" << i << " { "
          << ((disp || (sign_f16 && expr_prec_sig_in_f16(sig, i))) ? (disp ? "float" : "float16_t")
                                                                   : "float")
          << " b" << i << "[]; };\n";
        if (disp)
            L << "layout(std430, binding = " << (n_inputs + i) << ") readonly buffer Buf" << i
              << "h { float16_t b" << i << "h[]; };\n";
    }
    if (disp)
    {
        L << "layout(std430, binding = " << (2 * n_inputs)
          << ") writeonly buffer BufOut { float bout[]; };\n";
        L << "layout(std430, binding = " << (2 * n_inputs + 1)
          << ") writeonly buffer BufOuth { float16_t bout16[]; };\n\n";
    }
    else
        L << "layout(std430, binding = " << n_inputs << ") writeonly buffer BufOut { "
          << (out_f16 ? "float16_t" : "float") << " bout[]; };\n\n";
    L << "layout(push_constant) uniform PC {\n";
    L << "    uint count;\n";
    L << "    uint cols;\n";
    L << "    uint rows;\n";
    L << "    uint vector_out;   // 1=输出归约向量（(rows,1)/(1,cols)），0=广播\n";
    // matmul+归约（注意力结构）：mm_k 求和维度 + mm_batch 批量数 + mm_trans
    // 转置布局（前两者为形状参数、后者为运行期 operand layout，均运行时填充；
    // dispatch 不变，batch 由 idx 分解）
    if (spec.matmul)
    {
        L << "    uint mm_k;\n";
        L << "    uint mm_batch;\n";
        L << "    uint mm_trans;  // bit0=transA, bit1=transB（不进 key）\n";
    }
    if (disp) L << "    uint prec;      // 运行期精度分派位（bit i=输入 i 为 f16，bit16=输出）\n";
    const std::uint32_t n_vp = expr_spec_runtime_view_param_count(spec);
    for (std::uint32_t i = 0; i < n_vp; ++i)
        L << "    uint vp" << i << ";\n";
    for (std::size_t i = 0; i < spec.consts.size(); ++i)
        L << "    float c" << i << ";\n";
    const std::uint32_t n_rp = static_cast<std::uint32_t>(spec.rparams.size());
    for (std::uint32_t i = 0; i < n_rp; ++i)
        L << "    float rp" << i << ";\n";
    L << "};\n\n";
    L << "shared float s_red[" << n_slots << "][256];\n\n";
    // 分组归约视图的读取辅助函数（本生成器也调用 glsl_view_read）：不发射的话
    // 含该视图的 spec 会生成未声明函数 `gr_r<i>` —— glslc 报错（响亮，非静默），
    // 但报错点离根因很远。无该视图时本调用不产出任何文本。
    glsl_emit_grouped_reduce_helpers(L, spec, sig, /*f16_native=*/false);

    // 输出写回：非分派 = 单条赋值（wr 包 float16_t）；分派 = 输出双视图
    // + uniform 分支（每个元素只写一次）。
    const auto emit_wr = [&](const char* ind, const std::string& lhs, const std::string& v)
    {
        if (!disp)
        {
            L << ind << "bout[" << lhs << "] = " << wr(v) << ";\n";
            return;
        }
        L << ind << "if ((prec >> 16u & 1u) != 0u)\n";
        L << ind << "    bout16[" << lhs << "] = " << glsl_f16_store(v) << ";\n";
        L << ind << "else\n";
        L << ind << "    bout[" << lhs << "] = " << v << ";\n";
    };

    // ── matmul 段（分块 + batch）：当前元素 (row,col) 的 matmul 值（内联
    //     K 循环点积，不物化 (batch*M,N) 中间矩阵；**transA/transB 是运行期
    //     operand layout（mm_trans，不进 key）→ 两种索引都发射、运行时三元选择**，
    //     mm_k/mm_batch 运行时填充；row 为全局行 = batch*m_per + 块内行）──
    const MatmulSpec* mm = spec.matmul ? &*spec.matmul : nullptr;
    const auto emit_mm_decl = [&]()
    {
        if (!mm) return;
        const std::uint32_t a_slot = mm->a_input;
        const std::uint32_t b_slot = mm->b_input;
        L << "        const uint row_in_batch = row % m_per;\n";
        // 列归约：batch 无顶层分解（idx 是列 tile）→ 按当前 row 就地分解；
        // 行归约：顶层已有 batch（= idx/m_per），此处不重复声明
        if (!is_row) L << "        const uint batch = row / m_per;\n";
        // 转置布局（运行期 mm_trans，不进 key）：两种索引折算成 base + kk*stride，
        // 循环体内**无分支**（mm_trans 是 uniform push constant）。
        //   transA : A 存 (K,M) → idx = (batch*mm_k + kk)*m_per + row_in_batch
        //   !transA: A 存 (M,K) → idx = (batch*m_per + row_in_batch)*mm_k + kk
        L << "        const bool tA = (mm_trans & 1u) != 0u;\n";
        L << "        const uint a_base = tA ? (batch*mm_k*m_per + row_in_batch)\n"
          << "                               : (batch*m_per*mm_k + row_in_batch*mm_k);\n";
        L << "        const uint a_stride = tA ? m_per : 1u;\n";
        //   transB : B 存 (N,K) → idx = (batch*cols + col)*mm_k + kk
        //   !transB: B 存 (K,N) → idx = (batch*mm_k + kk)*cols + col
        L << "        const bool tB = (mm_trans & 2u) != 0u;\n";
        L << "        const uint b_base = tB ? (batch*cols*mm_k + col*mm_k)\n"
          << "                               : (batch*mm_k*cols + col);\n";
        L << "        const uint b_stride = tB ? 1u : cols;\n";
        L << "        float mm = 0.0;\n";
        L << "        for (uint kk = 0u; kk < mm_k; ++kk)\n";
        L << "            mm += " << rd(a_slot, "a_base + kk*a_stride") << " * "
          << rd(b_slot, "b_base + kk*b_stride") << ";\n";
    };

    L << "void main()\n{\n";
    L << "    const uint tid = gl_LocalInvocationID.x;\n";
    L << "    const uint idx = gl_WorkGroupID.x;\n";
    // 行归约：工作组=单行，idx<rows 守卫。列归约：工作组=32 列 tile，
    // lane=列内偏移、warp=行块（col = idx*32 + l；越界列不早退、读写守卫）。
    L << (is_row ? "    if (idx >= rows) return;\n" : "");
    // matmul+归约（batch 分解）：m_per = rows / mm_batch（形状参数，PC 填充）。
    //   行归约：idx 是全局行（batch*m_per + 批内行）→ batch 在顶层一次性分解；
    //   列归约：idx 是 32 列 tile、行在归约循环内逐个出现 → 顶层**不能**按 idx
    //     分解 batch，由 emit_mm_decl 按当前 row 就地分解（batch = row/m_per），
    //     归约循环遍历全部 rows（= batch*m_per，含所有 batch）——与 CPU 端
    //     matmul_out（batch 切片堆叠的 (rows, N)）逐列 max/sum 语义一致。
    if (mm)
    {
        L << "    const uint m_per = rows / mm_batch;\n";
        if (is_row) L << "    const uint batch = idx / m_per;\n";
    }

    // 归约结果索引：行=工作组单行（s_red[slot][0]）；列 tile=每线程一列（s_red[slot][tid]）
    const std::string red_idx = is_row ? "0" : "tid";

    // ── 操作数求值（当前元素由 row/col 变量给出） ──
    const auto operand = [&](const ExprOperand& op) -> std::string
    {
        switch (op.kind)
        {
        default:
        case static_cast<uint8_t>(ExprOperandKind::Reg):
        case static_cast<uint8_t>(ExprOperandKind::Fanout):
            return "r" + std::to_string(op.idx);
        case static_cast<uint8_t>(ExprOperandKind::Const):
            return "c" + std::to_string(op.idx);
        case static_cast<uint8_t>(ExprOperandKind::RParam):
            return "rp" + std::to_string(op.idx);
        case static_cast<uint8_t>(ExprOperandKind::Reduce):
            return "s_red[" + std::to_string(slot_of_instr[op.idx]) + "][" + red_idx + "]";
        case static_cast<uint8_t>(ExprOperandKind::Matmul):
            return "mm"; // 前置 matmul 段输出（emit_mm_decl 声明）
        // 索引操作数：Row 为 batch 内行号（row 变量是全局行 idx）；
        // batch 由 idx 分解（仅 matmul 段存在时）
        case static_cast<uint8_t>(ExprOperandKind::Row):
            return mm ? "float(row % m_per)" : "float(row)";
        case static_cast<uint8_t>(ExprOperandKind::Col):
            return "float(col)";
        case static_cast<uint8_t>(ExprOperandKind::Batch):
            if (!mm) return "0.0";
            // 行归约读顶层 batch（idx 分解）；列归约按当前 row 就地分解
            return is_row ? "float(batch)" : "float(row / m_per)";
        case static_cast<uint8_t>(ExprOperandKind::Input):
        {
            const ExprView& v = spec.views[op.idx];
            const ExprViewKind vk = static_cast<ExprViewKind>(v.kind);
            if (expr_view_is_reduce(vk))
                return "s_red[" + std::to_string(slot_of_view[op.idx]) + "][" + red_idx + "]";
            if (vk == ExprViewKind::RowBroadcast) return rd(op.idx, "row");
            if (vk == ExprViewKind::ColBroadcast) return rd(op.idx, "col");
            // Linear / RotateHalf / RowMod / RowGather / BatchMod：索引映射内联；
            // vp 槽见 glsl_vp_slot
            std::ostringstream os;
            glsl_view_read(os, v, static_cast<std::uint32_t>(op.idx), "(row*cols + col)", "row",
                           "col", glsl_vp_slot(spec, op.idx), sig);
            const std::string raw = os.str();
            // f16 槽：视图读取返回 float16_t 左值 → 显式转 f32（算术仍在 f32）
            return (sign_f16 && expr_prec_sig_in_f16(sig, op.idx)) ? ("float(" + raw + ")") : raw;
        }
        }
    };

    // 寄存器声明（先声明后赋值，兼容 IR-B liveness 复用同号寄存器）；
    // 每个 emit_instrs 调用点所在作用域内须先调用一次。
    const auto emit_reg_decl = [&]()
    {
        if (spec.num_regs == 0) return;
        L << "        float r0";
        for (std::uint32_t r = 1; r < spec.num_regs; ++r)
            L << ", r" << r;
        L << ";\n";
    };

    // 直线指令展开（跳过归约指令；归约结果经 s_red 访问；纯赋值，寄存器已声明）
    const auto emit_instrs = [&](std::size_t begin, std::size_t end)
    {
        // matmul 段：当前元素 (row,col) 的 mm 值（每元素求值作用域一次）
        emit_mm_decl();
        for (std::size_t j = begin; j < end; ++j)
        {
            const ExprInstr& ins = spec.instrs[j];
            const ExprOp op = static_cast<ExprOp>(ins.op);
            if (expr_op_is_reduce(op)) continue;
            const std::string dst = "r" + std::to_string(ins.dst);
            const std::string a = operand(ins.a);
            const detail::ExprOpInfo& info = detail::expr_op_info(op);
            if (info.emit == detail::ExprEmitKind::None) continue; // 归约指令已在上方 continue 分流
            // 发射形态/符号查表（expr_op_table）
            L << "        " << dst << " = "
              << glsl_alu_expr(
                     info, a, [&] { return operand(ins.b); }, [&] { return operand(ins.c); },
                     /*vec4=*/false, /*native16=*/false, /*wrap=*/false)
              << ";\n";
        }
    };

    // 组合表达式：sum → "a + b"（中缀），max → "max(a, b)"（函数）
    const auto combine = [](bool is_max, const std::string& a, const std::string& b)
    { return is_max ? "max(" + a + ", " + b + ")" : "(" + a + " + " + b + ")"; };

    // 归约：warp shuffle 蝴蝶归约（subgroup）替代共享内存树形归约。
    //   第 1 步：warp 内 subgroupAdd/subgroupMax → 每 warp 一个部分和（零共享/屏障）
    //   第 2 步：首 warp 归约全部 warp 部分和 → s_red[slot][0]（屏障后全线程可见）
    // 真机(NVIDIA, prime-run)大矩阵实测有效（combine 步骤为单次 subgroup 归约，非多步 barrier 串行）。
    const auto emit_tree_reduce = [&](int slot, bool is_max)
    {
        const std::string s = "s_red[" + std::to_string(slot) + "]";
        const char* sub = is_max ? "subgroupMax" : "subgroupAdd";
        // max init = lowest()（0xFF7FFFFF）对齐 CPU 基准，理由同归约视图处注释
        const std::string idt = is_max ? "uintBitsToFloat(0xFF7FFFFFu)" : "0.0";
        const std::string vn = "v" + std::to_string(slot); // 按槽唯一命名，避免重定义
        const std::string wn = "w" + std::to_string(slot);
        L << "    barrier();\n";
        L << "    float " << vn << " = " << s << "[tid];\n";
        L << "    " << vn << " = " << sub << "(" << vn << ");\n";
        L << "    if (gl_SubgroupInvocationID == 0u) " << s << "[gl_SubgroupID] = " << vn << ";\n";
        L << "    barrier();\n";
        L << "    if (gl_SubgroupID == 0u) {\n";
        L << "        float " << wn << " = (gl_SubgroupInvocationID < gl_NumSubgroups) ? " << s
          << "[gl_SubgroupInvocationID] : " << idt << ";\n";
        L << "        " << wn << " = " << sub << "(" << wn << ");\n";
        L << "        if (gl_SubgroupInvocationID == 0u) " << s << "[0] = " << wn << ";\n";
        L << "    }\n";
        L << "    barrier();\n";
    };

    // 组合 4 路累加器（sum/max）
    const auto combine4 = [&](bool is_max, const std::string& a0, const std::string& a1,
                              const std::string& a2, const std::string& a3)
    { return combine(is_max, combine(is_max, combine(is_max, a0, a1), a2), a3); };

    if (is_row)
    {
        // ═══ 行归约（工作组单行、跨线程跨步 + 树形归约；合并访问）═══
        const std::string loop_decl = "    for (uint c = tid; c < cols; c += 256u) {\n        "
                                      "const uint row = idx;\n        const uint col = c;\n";
        const std::string out_idx = "row*cols + col";

        // ── 归约视图 pass（多累加器，跨步 4*256）──
        for (std::size_t k = 0; k < n_inputs; ++k)
        {
            const ExprView& v = spec.views[k];
            if (!expr_view_is_reduce(static_cast<ExprViewKind>(v.kind))) continue;
            const int slot = slot_of_view[k];
            const bool is_max = slot_is_max[static_cast<std::size_t>(slot)];
            // max init = lowest()（0xFF7FFFFF）对齐 CPU 基准（全库归约一律
            //   numeric_limits::lowest()）：-inf 作恒等元在全 -inf 输入下与
            //   状态进位/减法组合会出 −inf−−inf=NaN，全库统一 lowest 根除
            //   该风险类
            const std::string init = is_max ? "uintBitsToFloat(0xFF7FFFFFu)" : "0.0";
            L << "\n    // 归约视图 " << k << " (槽 " << slot << ")\n";
            L << "    {\n";
            L << "        float acc0 = " << init << ", acc1 = " << init << ", acc2 = " << init
              << ", acc3 = " << init << ";\n";
            L << "        uint i = tid;\n";
            L << "        for (; i + 3u*256u < cols; i += 4u*256u) {\n";
            L << "            acc0 = " << combine(is_max, "acc0", rd(k, "idx*cols + i")) << ";\n";
            L << "            acc1 = " << combine(is_max, "acc1", rd(k, "idx*cols + i+256u"))
              << ";\n";
            L << "            acc2 = " << combine(is_max, "acc2", rd(k, "idx*cols + i+512u"))
              << ";\n";
            L << "            acc3 = " << combine(is_max, "acc3", rd(k, "idx*cols + i+768u"))
              << ";\n";
            L << "        }\n";
            L << "        for (; i < cols; i += 256u)\n";
            L << "            acc0 = " << combine(is_max, "acc0", rd(k, "idx*cols + i")) << ";\n";
            L << "        s_red[" << slot
              << "][tid] = " << combine4(is_max, "acc0", "acc1", "acc2", "acc3") << ";\n";
            L << "    }\n";
            emit_tree_reduce(slot, is_max);
        }

        // ── 归约指令 pass（多累加器跨步循环 + 树形归约）──
        // 用 4 路独立标量累加器（独立标量而非数组元素）打破 acc 串行依赖链，
        // 提升 ILP；跨步 4*256 与归约视图 pass 一致。归约结合序改变（与视图 pass 相同），
        // 测试容差已覆盖。
        for (std::size_t ri = 0; ri < spec.instrs.size(); ++ri)
        {
            const ExprInstr& R = spec.instrs[ri];
            if (!expr_op_is_reduce(static_cast<ExprOp>(R.op))) continue;
            const int slot = slot_of_instr[R.dst];
            const bool is_max = slot_is_max[static_cast<std::size_t>(slot)];
            const bool src_is_reg = (R.a.kind == static_cast<uint8_t>(ExprOperandKind::Reg) ||
                                     R.a.kind == static_cast<uint8_t>(ExprOperandKind::Fanout));
            const std::string src =
                src_is_reg ? "r" + std::to_string(static_cast<int>(R.a.idx)) : operand(R.a);
            // max init = lowest()（0xFF7FFFFF）对齐 CPU 基准（全库归约一律
            //   numeric_limits::lowest()）：-inf 作恒等元在全 -inf 输入下与
            //   状态进位/减法组合会出 −inf−−inf=NaN，全库统一 lowest 根除
            //   该风险类
            const std::string init = is_max ? "uintBitsToFloat(0xFF7FFFFFu)" : "0.0";
            L << "\n    // 归约指令 " << ri << " (槽 " << slot << ")\n";
            L << "    {\n";
            L << "        float acc0 = " << init << ", acc1 = " << init << ", acc2 = " << init
              << ", acc3 = " << init << ";\n";
            L << "        uint c = tid;\n";
            L << "        for (; c + 3u*256u < cols; c += 4u*256u) {\n";
            for (int k = 0; k < 4; ++k)
            {
                L << "            { const uint row = idx; const uint col = c + "
                  << std::to_string(256 * k) << "u; ";
                emit_reg_decl();
                emit_instrs(0, ri);
                L << " acc" << k << " = " << combine(is_max, "acc" + std::to_string(k), src)
                  << "; }\n";
            }
            L << "        }\n";
            L << "        for (; c < cols; c += 256u) {\n";
            L << "            { const uint row = idx; const uint col = c; ";
            emit_reg_decl();
            emit_instrs(0, ri);
            L << " acc0 = " << combine(is_max, "acc0", src) << "; }\n";
            L << "        }\n";
            L << "        s_red[" << slot
              << "][tid] = " << combine4(is_max, "acc0", "acc1", "acc2", "acc3") << ";\n";
            L << "    }\n";
            emit_tree_reduce(slot, is_max);
        }

        // ── 输出 pass（行）──
        L << "\n    // 输出\n";
        L << "    if (vector_out == 1u) {\n";
        L << "        if (tid == 0u) {\n";
        if (last_is_reduce)
            emit_wr("            ", "idx",
                    "s_red[" + std::to_string(slot_of_instr[spec.instrs.back().dst]) + "][0]");
        else
        {
            L << "            const uint row = idx;\n            const uint col = 0u;\n";
            emit_reg_decl();
            emit_instrs(0, spec.instrs.size());
            emit_wr("            ", "idx",
                    "r" + std::to_string(static_cast<int>(spec.instrs.back().dst)));
        }
        L << "        }\n";
        L << "        return;\n";
        L << "    }\n";
        L << loop_decl;
        if (last_is_reduce)
            emit_wr("        ", out_idx,
                    "s_red[" + std::to_string(slot_of_instr[spec.instrs.back().dst]) + "][0]");
        else
        {
            emit_reg_decl();
            emit_instrs(0, spec.instrs.size());
            emit_wr("        ", out_idx,
                    "r" + std::to_string(static_cast<int>(spec.instrs.back().dst)));
        }
        L << "    }\n";
    }
    else
    {
        // ═══ 列归约（与 OP 级 reduce.comp 列模式同构）═══
        // 结构选型：每 WG 覆盖 32 列——CE 场景 cols = total 常为数百，若按
        // ceil(cols/256) 派发只有个位数 WG、行循环串行度极高；且须与 OP 级
        // （WG=单列、lane 跨行步进）保持同一算法。列内组织：
        //   lane = 列内偏移 l（同 32 连续列 → 同行读 128B 合并事务）
        //   warp = 行块 wb（8 个，row = wb 步进 8）→ 每 WG 覆盖 32 列
        //   部分和 s_red[slot][tid]（tid = wb*32+l）→ 跨 8 行块合并就地覆写
        //   dispatch：ceil(cols/32)（backend raxis==1 同源改）
        //   4 路累加器跨步 32（8 行 × 4），ILP 形态与行 pass 一致
        // 越界列**不早退**（barrier 需全 WG 参与）：读跳过、部分和置恒等元、
        // 输出写守卫。
        // emit_col_merge：每个归约 pass 后跨 8 行块合并本槽（与行 pass 的
        // emit_tree_reduce 调用位置契约一致——后续 pass/输出读到的都是
        // 整列值；s_red[w*32+l] 跨 lane 连续读、[tid] 连续写，零 bank 冲突）
        const auto emit_col_merge = [&](int slot, bool is_max)
        {
            const std::string s = "s_red[" + std::to_string(slot) + "]";
            const std::string init = is_max ? "uintBitsToFloat(0xFF7FFFFFu)" : "0.0";
            const std::string m = "m" + std::to_string(slot);
            L << "    barrier();\n"; // ① 各行块部分和写完
            L << "    { float " << m << " = " << init << ";\n";
            L << "        for (uint w = 0u; w < 8u; ++w)\n";
            L << "            " << m << " = " << combine(is_max, m, s + "[w*32u + l]") << ";\n";
            // ② 读/写分离：所有 lane 读完 8 项后才允许覆写自身槽位
            //    （写 s_red[tid=(wb*32+l)] 与他 lane 读 [w*32+l] 同址，
            //     无此 barrier 会读到已覆写值 → sum 双计）
            L << "        barrier();\n";
            L << "        " << s << "[tid] = " << m << "; }\n";
            L << "    barrier();\n"; // ③ 覆写完成，后续 pass/输出才可读
        };
        L << "    const uint l  = tid & 31u;\n";
        L << "    const uint wb = tid >> 5u;\n";
        L << "    const uint col = idx * 32u + l;\n";

        // ── 归约视图 pass（tile：每线程一整列，多累加器跨行顺序读，合并访问）──
        for (std::size_t k = 0; k < n_inputs; ++k)
        {
            const ExprView& v = spec.views[k];
            if (!expr_view_is_reduce(static_cast<ExprViewKind>(v.kind))) continue;
            const int slot = slot_of_view[k];
            const bool is_max = slot_is_max[static_cast<std::size_t>(slot)];
            // max init = lowest()（0xFF7FFFFF）对齐 CPU 基准（全库归约一律
            //   numeric_limits::lowest()）：-inf 作恒等元在全 -inf 输入下与
            //   状态进位/减法组合会出 −inf−−inf=NaN，全库统一 lowest 根除
            //   该风险类
            const std::string init = is_max ? "uintBitsToFloat(0xFF7FFFFFu)" : "0.0";
            L << "\n    // 归约视图 " << k << " (槽 " << slot << ")\n";
            L << "    {\n";
            L << "        float acc0 = " << init << ", acc1 = " << init << ", acc2 = " << init
              << ", acc3 = " << init << ";\n";
            L << "        if (col < cols) {\n";
            L << "            uint i = wb;\n";
            L << "            for (; i + 24u < rows; i += 32u) {\n";
            L << "                acc0 = " << combine(is_max, "acc0", rd(k, "i*cols + col"))
              << ";\n";
            L << "                acc1 = " << combine(is_max, "acc1", rd(k, "(i+8u)*cols + col"))
              << ";\n";
            L << "                acc2 = " << combine(is_max, "acc2", rd(k, "(i+16u)*cols + col"))
              << ";\n";
            L << "                acc3 = " << combine(is_max, "acc3", rd(k, "(i+24u)*cols + col"))
              << ";\n";
            L << "            }\n";
            L << "            for (; i < rows; i += 8u)\n";
            L << "                acc0 = " << combine(is_max, "acc0", rd(k, "i*cols + col"))
              << ";\n";
            L << "        }\n";
            L << "        s_red[" << slot
              << "][tid] = " << combine4(is_max, "acc0", "acc1", "acc2", "acc3") << ";\n";
            L << "    }\n";
            emit_col_merge(slot, is_max);
        }

        // ── 归约指令 pass（tile：多累加器，跨行顺序读，合并访问）──
        // 4 路独立标量累加器打破 acc 串行依赖链，提升 ILP（与行归约一致）。
        for (std::size_t ri = 0; ri < spec.instrs.size(); ++ri)
        {
            const ExprInstr& R = spec.instrs[ri];
            if (!expr_op_is_reduce(static_cast<ExprOp>(R.op))) continue;
            const int slot = slot_of_instr[R.dst];
            const bool is_max = slot_is_max[static_cast<std::size_t>(slot)];
            const bool src_is_reg = (R.a.kind == static_cast<uint8_t>(ExprOperandKind::Reg) ||
                                     R.a.kind == static_cast<uint8_t>(ExprOperandKind::Fanout));
            const std::string src =
                src_is_reg ? "r" + std::to_string(static_cast<int>(R.a.idx)) : operand(R.a);
            // max init = lowest()（0xFF7FFFFF）对齐 CPU 基准（全库归约一律
            //   numeric_limits::lowest()）：-inf 作恒等元在全 -inf 输入下与
            //   状态进位/减法组合会出 −inf−−inf=NaN，全库统一 lowest 根除
            //   该风险类
            const std::string init = is_max ? "uintBitsToFloat(0xFF7FFFFFu)" : "0.0";
            L << "\n    // 归约指令 " << ri << " (槽 " << slot << ")\n";
            L << "    {\n";
            L << "        float acc0 = " << init << ", acc1 = " << init << ", acc2 = " << init
              << ", acc3 = " << init << ";\n";
            L << "        if (col < cols) {\n";
            L << "            uint i = wb;\n";
            L << "            for (; i + 24u < rows; i += 32u) {\n";
            for (int k = 0; k < 4; ++k)
            {
                L << "                { const uint row = i + " << std::to_string(8 * k) << "u; ";
                emit_reg_decl();
                emit_instrs(0, ri);
                L << " acc" << k << " = " << combine(is_max, "acc" + std::to_string(k), src)
                  << "; }\n";
            }
            L << "            }\n";
            L << "            for (; i < rows; i += 8u) {\n";
            L << "                { const uint row = i; ";
            emit_reg_decl();
            emit_instrs(0, ri);
            L << " acc0 = " << combine(is_max, "acc0", src) << "; }\n";
            L << "            }\n";
            L << "        }\n";
            L << "        s_red[" << slot
              << "][tid] = " << combine4(is_max, "acc0", "acc1", "acc2", "acc3") << ";\n";
            L << "    }\n";
            emit_col_merge(slot, is_max);
        }

        // ── 输出 pass（列：lane=列 / warp=行块，只写自己行块的行）──
        L << "\n    // 输出\n";
        L << "    if (vector_out == 1u) {\n";
        if (last_is_reduce)
        {
            if (disp)
            {
                L << "        if (col < cols) {\n";
                emit_wr("            ", "col",
                        "s_red[" + std::to_string(slot_of_instr[spec.instrs.back().dst]) +
                            "][tid]");
                L << "        }\n";
            }
            else
                L << "        if (col < cols) bout[col] = "
                  << wr("s_red[" + std::to_string(slot_of_instr[spec.instrs.back().dst]) + "][tid]")
                  << ";\n";
        }
        else
        {
            L << "        if (col < cols) {\n";
            L << "            const uint row = 0u;\n";
            emit_reg_decl();
            emit_instrs(0, spec.instrs.size());
            emit_wr("            ", "col",
                    "r" + std::to_string(static_cast<int>(spec.instrs.back().dst)));
            L << "        }\n";
        }
        L << "        return;\n";
        L << "    }\n";
        L << "    if (col < cols) for (uint row = wb; row < rows; row += 8u) {\n";
        if (last_is_reduce)
            emit_wr("        ", "row*cols + col",
                    "s_red[" + std::to_string(slot_of_instr[spec.instrs.back().dst]) + "][tid]");
        else
        {
            emit_reg_decl();
            emit_instrs(0, spec.instrs.size());
            emit_wr("        ", "row*cols + col",
                    "r" + std::to_string(static_cast<int>(spec.instrs.back().dst)));
        }
        L << "    }\n";
    }
    L << "}\n";
    return L.str();
}

// ═══════════════════════════════════════════════════════════════════════════
//  GlslEmitter — GLSL 后端 emitter（IR-D）
//
//  把上述 generate_glsl / generate_glsl_reduce 封装为 ExprEmitter 接口实现，
//  使生成器工具（gen_fused）经统一接口选择后端，与具体后端解耦。
//  自由函数 generate_glsl / generate_glsl_reduce 保留为便捷入口
//  （内部转发到 GlslEmitter），向后兼容既有调用方。
// ═══════════════════════════════════════════════════════════════════════════
class GlslEmitter final : public ExprEmitter
{
public:
    [[nodiscard]] std::string_view name() const noexcept override { return "glsl"; }

    [[nodiscard]] std::string generate(const std::string& name_, const ExprSpec& spec,
                                       ExprPrecSig sig = 0, bool native16 = false) override
    { return nn::generate_glsl(name_, spec, sig, native16); }

    [[nodiscard]] std::string generate_reduce(const std::string& name_, const ExprSpec& spec,
                                              ExprPrecSig sig = 0) override
    { return nn::generate_glsl_reduce(name_, spec, sig); }

    // P3 批量变体（键 = key#b）：纯逐元素 + V0 全 f32 的多实例批量派发形态
    // （实例表 + buffer device address）。不支持的形态返回空串 → 上层跳过
    // 该变体，运行期逐 kernel 降级（见 expr_spec_batchable）。
    [[nodiscard]] std::string generate_batched(const std::string& name_, const ExprSpec& spec,
                                               ExprPrecSig sig = 0) const override
    {
        return nn::generate_glsl(name_, spec, sig, /*native16=*/false,
                                 /*batched=*/true);
    }

    // matmul 细 tile 变体（键 = key#f，P0 wgrad 网格饥饿）：输出块 16×16、
    // 每线程 2×2 输出（R=2）的同结构 shader。不支持的形态（非纯 matmul）
    // 返回空串 → 上层跳过该变体，运行期留在 64-tile 路径（降级，不是错误）。
    [[nodiscard]] std::string generate_matmul_fine(const std::string& name_, const ExprSpec& spec,
                                                   ExprPrecSig sig = 0) const override
    {
        return nn::generate_glsl(name_, spec, sig, /*native16=*/false,
                                 /*batched=*/false, /*mm_fine=*/true);
    }

    // matmul K 切分变体（键 = key#ks）：细 tile 网格上把 K 切成 S 段，每 WG
    // 一段写部分和（不跑尾链）。不支持的形态（非纯 matmul/非 V0）返回空串
    // → 上层跳过该变体，运行期留在细 tile 路径（降级，不是错误）。
    [[nodiscard]] std::string generate_matmul_ksplit(const std::string& name_, const ExprSpec& spec,
                                                     ExprPrecSig sig = 0) const override
    {
        return nn::generate_glsl(name_, spec, sig, /*native16=*/false,
                                 /*batched=*/false, /*mm_fine=*/false,
                                 /*mm_ksplit=*/true);
    }

    // K 切分伴生归约（键 = key#kr）：跨段升序求和 + 同一条尾链。
    // 资格判据在 generate_glsl_matmul_ksplit_reduce 内，与 #ks 同源。
    [[nodiscard]] std::string generate_matmul_ksplit_reduce(const std::string& name_,
                                                            const ExprSpec& spec,
                                                            ExprPrecSig sig = 0) const override
    { return nn::generate_glsl_matmul_ksplit_reduce(name_, spec, sig); }
};

// 登记到 emitter 注册表（静态初始化；重复包含无害——同名拒绝覆盖）
inline const bool kGlslEmitterRegistered = emitter_registry::register_backend(
    "glsl", []() -> std::unique_ptr<ExprEmitter> { return std::make_unique<GlslEmitter>(); });

} // namespace nn
