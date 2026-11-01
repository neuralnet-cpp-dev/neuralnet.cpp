#pragma once

#include <cstddef>

#include "core_errors.hpp"
#include "precision.hpp"

// NN_VECTORIZE_PRAGMA：循环向量化提示的编译器分支实现，统一定义在 core_config.hpp
#if defined(__clang__)
#define NN_VECTORIZE_PRAGMA _Pragma("clang loop vectorize(assume_safety)")
#elif defined(__GNUC__) || defined(__GNUG__)
#define NN_VECTORIZE_PRAGMA _Pragma("GCC ivdep")
#elif defined(_MSC_VER)
    // MSVC 的 #pragma loop(ivdep) / __pragma(loop(ivdep)) 在 lambda/复合语句内部
    // 会导致 C2059/C3925 编译错误（解析器将 { 误判为循环体）。
    // MSVC 在 /O2 下默认启用自动向量化，此处留空即可。
#define NN_VECTORIZE_PRAGMA
#elif defined(__ICC) || defined(__INTEL_COMPILER)
#define NN_VECTORIZE_PRAGMA _Pragma("vector always")
#else
#define NN_VECTORIZE_PRAGMA
#endif

// ── 缓存分块大小 ─────────────────────────────────────────────────────────────
// 64×64×8 = 32 KB，安全装入大多数 CPU 的 L1 缓存
// 矩阵乘法、转置等所有分块操作共用此值
// 修改时需同步评估 b_block 栈占用（BLOCK_SIZE² × 8 字节）
namespace nn
{
// ── 标量类型（float 加速 / double 精度） ─────────────────────────
using Scalar = float;

inline constexpr std::size_t BLOCK_SIZE = 64;
static_assert(BLOCK_SIZE * BLOCK_SIZE * sizeof(Scalar) <= 65536,
              "BLOCK_SIZE too large: b_block would exceed 64KB stack budget");
// ── 数值常量 ─────────────────────────────────────────────────────────────
// 使用 constexpr 避免运行时计算
inline constexpr Scalar EPSILON = 1e-6f;

// ── 并行阈值 ─────────────────────────────────────────────────────────────
// 元素数 >= 此值时启用线程池并行；低于则串行执行（避免调度开销）。
// 线程池调度开销约 50-200μs（Windows mutex+cv），仅当计算量足够时并行才有收益。
//
// 实测结果（32 核 CPU, Release -O3）：
//   元素数   串行μs  并行μs  加速比   建议
//   16384     9.6    9.8     0.98x   无差别
//   32768    18.8   19.9     0.94x   无差别
//   65536    38.7  121.7     0.32x   串行优（调度开销显现）
//   131072   76.4  182.8     0.42x   串行优
//   262144  151.6  196.0     0.77x   串行优
//   524288  308.7  201.5     1.53x   ← 首次稳定 > 1.5x
//   1048576 620.3  186.7     3.32x   并行优（稳定）
//   2097152 1239.5 217.3     5.70x   并行优
//   4194304 2657.3 340.6     7.80x   并行优
// 取 524288 (512K) 作为阈值：在加速比首次稳定 > 1.5x 的位置。
// 注：1024-4096 元素数测出的高加速比是亚微秒级测量噪声，不可靠。
inline constexpr std::size_t PARALLEL_THRESHOLD = 524288;

// ── 诊断探针编译门（默认关；CMake `-DNN_ENABLE_PROBES=ON` 才编入）────────
// "探针" = 会在**热路径**采样/打印/下载/扫描的诊断代码：层内逐中间量扫描
//（`nn_dbg_scan` / `NN_F16_DEBUG`）、精度变体与边界 cast 归因
//（`NN_PREC_TRACE` / `note_temp_`）、训练循环的非有限值追踪（`NN_NAN_TRACE`）、
// 显存阶段采样（`NN_MEM_STATS`），以及探针可执行目标（`mem_probe` /
// `f16_cpu_probe` / `gpu_stability_probe`）。
// 关闭（默认）时它们**不参与编译**：正常训练没有额外分支、没有字符串、
// 没有 host 下载路径，相关环境变量一律无效——探针只在排障时按需打开，
// 不允许"设了环境变量就悄悄拖慢正常训练"。
// 新增探针一律走这个门；初始化期读一次的**行为开关**（`NN_VULKAN_DEVICE`
// 正确性检查、`NN_VULKAN_*` 设备/特性逃生阀、`NN_POOL_*` 池 A/B）不在此列。
// 门经 `nn_core` 的 INTERFACE 定义传播 → 所有 TU（含嵌入消费方）取值一致。
#if defined(NN_ENABLE_PROBES) && NN_ENABLE_PROBES
#define NN_PROBES_ENABLED 1
#else
#define NN_PROBES_ENABLED 0
#endif

} // namespace nn
