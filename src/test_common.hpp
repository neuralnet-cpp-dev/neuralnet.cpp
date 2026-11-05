// ── test_common.hpp — 测试公共工具（唯一副本）─────────────────────────────
//
// 背景：本仓测试用「#define main test_xxx + #include 子测试.cpp」的聚合编译
// 模式（见 expr_cpu_test.cpp / precision_test.cpp / layer_gradcheck_test.cpp）。
// CHECK / make_tensor / check_close / approx / dot / close_to 收敛于本头
// （唯一副本），子测试通过 `#define` 重命名计数器接入聚合器；聚合器只需
// 重命名 main、失败计数器与各测试独有的函数名（避免 ODR 冲突）。
//
// 约定：
//   1. 失败计数器由各子测试自带（`int g_fail = 0;` 或 `int g_failures = 0;`），
//      聚合器用 `#define g_fail g_fail_xxx` 重命名——计数器是"文件私有"的，
//      这样每个子测试的 main 返回值只统计自己的失败（聚合器 += 各自返回值）。
//   2. CHECK 经 NN_TEST_COUNTER 间接引用计数器（默认 g_fail）；计数器叫
//      g_failures 的文件在 include 前加一行 `#define NN_TEST_COUNTER g_failures`。
//      （宏体在**使用点**展开，聚合器对 g_fail/g_failures 的重命名照样生效。）
//   3. 本头的函数均为 inline 单份定义；子测试**不得**再定义同名函数。
//
// 刻意不收编：
//   · max_abs_diff —— 9 份副本语义有分叉（conv2d 版多形状守卫返回 1e9，
//     其余无守卫），统一前需逐点确认语义，另案处理；
//   · check_grad_tensor / eval_loss —— 按被测层类型特化，本就不可共享。
// ─────────────────────────────────────────────────────────────────────────

#pragma once

#include <nn_error_macros.hpp>
#include <algorithm>
#include <cmath>
#include <cstdio>
#include <iostream>
#include <string>

#include "neuralnet.cpp/algebra_matrix.hpp"  // Matrix / Scalar
#include "neuralnet.cpp/compute_tensor.hpp"  // Tensor
#include "neuralnet.cpp/compute_engine.hpp"  // ComputeEngine（M1：库外经引擎上传/下载）

// ── 失败断言宏 ─────────────────────────────────────────────────────────────
#ifndef NN_TEST_COUNTER
#define NN_TEST_COUNTER g_fail
#endif

#define CHECK(cond, msg)                                                  \
    do                                                                    \
    {                                                                     \
        if (!(cond))                                                      \
        {                                                                 \
            std::printf("[FAIL] %s:%d: %s\n", __FILE__, __LINE__, (msg)); \
            ++NN_TEST_COUNTER;                                            \
        }                                                                 \
    } while (0)

// ── M1 访问收口（docs/internal/17 §4.1）：库外一律经引擎上传/下载 ───────
// Tensor 存储与静态直构工厂收归引擎私有后，测试的填数/对拍路径为：
//   填数：宿主 Matrix 上写好 → upload(eng, m) 生成引擎张量
//   对拍：download(eng, t) 取回宿主 Matrix（P=F32：f16 精确升位，不丢值）
// NN_ASSERT_ALWAYS 兜底（与 close_to 同款）：引擎 I/O 失败属测试环境错误，非数值
// 失败；**Release 测试构建（NDEBUG）下也必须终止**，否则随后的解引用 = UB（RV-01）。
inline nn::Tensor upload(nn::ComputeEngine& e, const nn::Matrix& m,
                         nn::Precision p = nn::Precision::F32)
{
    auto r = e.from_matrix(m, p);
    NN_ASSERT_ALWAYS(r, "upload: engine.from_matrix failed");
    return std::move(*r);
}

// f16 宿主矩阵上传（f16→f32 逐元素升位后按 F16 落盘：往返精确无损）
inline nn::Tensor upload(nn::ComputeEngine& e, const nn::MatrixT<nn::Precision::F16>& m)
{
    nn::Matrix m32(m.rows(), m.cols());
    const auto s = m.span();
    auto d = m32.span();
    for (std::size_t i = 0; i < s.size(); ++i)
        d[i] = static_cast<float>(s[i]);
    return upload(e, m32, nn::Precision::F16);
}

inline nn::Matrix download(nn::ComputeEngine& e, const nn::Tensor& t)
{
    auto r = e.to_matrix(t);   // P=F32 默认：f16 存储精确升位
    NN_ASSERT_ALWAYS(r, "download: engine.to_matrix failed");
    return std::move(*r);
}

// ── 构造确定性测试张量（base + i*step 填充；经引擎上传，出生即绑定）────────
inline nn::Tensor make_tensor(nn::ComputeEngine& e, std::size_t rows, std::size_t cols,
                              float base = 0.0f, float step = 0.01f)
{
    nn::Matrix m(rows, cols);
    auto sp = m.span();
    for (std::size_t i = 0; i < sp.size(); ++i)
        sp[i] = base + static_cast<float>(i) * step;
    return upload(e, m);
}

// ── 逐元素比对 Tensor（容差 1e-4 相对；失败计数进 fails = 调用方的 g_fail）──
inline void check_close(nn::ComputeEngine& e, const nn::Tensor& got, const nn::Tensor& ref,
                        const char* msg, int& fails)
{
    if (got.rows() != ref.rows() || got.cols() != ref.cols())
    {
        std::printf("[FAIL] %s: shape mismatch got %zux%zu ref %zux%zu\n", msg, got.rows(),
                    got.cols(), ref.rows(), ref.cols());
        ++fails;
        return;
    }
    const auto gm = download(e, got);
    const auto rm = download(e, ref);
    const auto g = gm.span();
    const auto r = rm.span();
    bool ok = true;
    for (std::size_t i = 0; i < g.size(); ++i)
    {
        const float d = std::fabs(g[i] - r[i]);
        const float scale = std::max(1.0f, std::fabs(r[i]));
        if (d > 1e-4f * scale)
        {
            std::printf("[FAIL] %s: [%zu] got %.6f ref %.6f\n", msg, i, g[i], r[i]);
            ok = false;
            break;
        }
    }
    if (ok) std::printf("[ OK ] %s\n", msg);
    else ++fails;
}

// ── 数值 vs 解析梯度的相对容差判据（gradcheck 通用）───────────────────────
inline bool approx(nn::Scalar num, nn::Scalar ana, nn::Scalar tol)
{ return std::fabs(num - ana) <= tol * (nn::Scalar{1} + std::fabs(num) + std::fabs(ana)); }

// ── 矩阵点积（gradcheck 计算参考损失用）───────────────────────────────────
inline nn::Scalar dot(const nn::Matrix& a, const nn::Matrix& b)
{
    nn::Scalar s{0};
    const auto sa = a.span();
    const auto sb = b.span();
    for (std::size_t i = 0; i < a.size(); ++i)
        s += sa[i] * sb[i];
    return s;
}

// ── 比对两矩阵（abs-or-rel 容差；打印 max_abs/max_rel 与判定）──────────────
inline bool close_to(const nn::Matrix& a, const nn::Matrix& b, nn::Scalar tol,
                     const std::string& name, std::size_t idx)
{
    NN_ASSERT_ALWAYS(a.rows() == b.rows() && a.cols() == b.cols(), "close_to: shape mismatch");
    nn::Scalar max_abs = 0;
    nn::Scalar max_rel = 0;
    const auto& sa = a.span();
    const auto& sb = b.span();
    for (std::size_t i = 0; i < a.size(); ++i)
    {
        const nn::Scalar diff = std::fabs(sa[i] - sb[i]);
        if (diff > max_abs) max_abs = diff;
        const nn::Scalar denom = std::fabs(sb[i]) > 1e-30f ? std::fabs(sb[i]) : 1.0f;
        const nn::Scalar rel = diff / denom;
        if (rel > max_rel) max_rel = rel;
    }
    const bool pass = (max_abs <= tol) || (max_rel <= tol);
    std::cout << "    [" << idx << "] " << name << "  max_abs=" << max_abs
              << "  max_rel=" << max_rel << (pass ? "  OK" : "  FAIL") << "\n";
    return pass;
}
