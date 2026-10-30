# gfx946 RMSNorm 测试

这两个测试脚本可随仓库直接运行，默认不依赖临时目录、历史 JSON、构建辅助脚本或专用 JIT 缓存。`test_rmsnorm_dynamicquant.py` 导入同目录 `test_rmsnorm.py` 中的环境设置及拓扑查询函数，因此应一同保留两个文件。每个数值用例只调用一次被测算子，没有 warmup 或性能循环。

前提：配置好的 PyTorch/HIP（Perf Model 还需 PMD）、当前 AITER Python 源码及依赖。首次构建还需要 HIP 编译器、Ninja，以及与当前算子实现匹配的完整 `3rdparty/composable_kernel` 子模块。仅复制测试脚本不能替代算子适配源码。

默认加载常规 `module_rmsnorm`，缺失时按 AITER JIT 配置自动构建。修改 native 源码后，在下面任意一个数值测试命令上加 `--rebuild`，重新构建后再测。五个入口共用这个模块，只需重建一次。不要为这些测试设置指向历史任务目录的 `AITER_JIT_DIR` 或 `CK_DIR`。JSON 和 PMD 产生的统计文件都是新输出，不是输入依赖；`--resume` 是可选优化，默认完全不使用历史结果。

## Perf Model 环境

在已配置 PyTorch/HIP 和 Perf Model 的环境中，从 AITER 仓库根目录执行。先按实际安装环境设置 `ROCM_PATH`（HIP SDK 根目录）和 `PMD_PATH`（Perf Model 运行库目录）；下面命令沿用这两个环境变量。

```bash
REPO="$(pwd)"
TEST="$REPO/op_tests/gfx946_tests/rmsnorm"
: "${ROCM_PATH:?请先设置 HIP SDK 根目录}"
: "${PMD_PATH:?请先设置 Perf Model 运行库目录}"
export ROCM_PATH PMD_PATH
export LD_LIBRARY_PATH="$ROCM_PATH/lib:$PMD_PATH:${LD_LIBRARY_PATH:-}"
export PYTHONPATH="$REPO" GPU_DFLAGS='[]' PYTHONDONTWRITEBYTECODE=1
unset AITER_JIT_DIR CK_DIR AITER_REBUILD GPU_ARCHS GPU_ARGS AITER_ENABLE_FP8
unset CK_TILE_RMSNORM_DIE_MODE CK_TILE_RMSNORM_DIE_CHUNK CK_TILE_RMSNORM_DIE_MASK
RUN=$(mktemp -d)
cd "$RUN"
```

选择一种拓扑，然后运行下节五条命令。切换拓扑后重新运行同样的命令即可。`GPU_CHIP` 必须在启动 Python 前设置；`--expect-xcds` 只断言实际拓扑，不负责设置 die 数。

```bash
# 单 die
export GPU_CHIP=sb; DIES=1; SUITE=quick
# 或双 die
export GPU_CHIP=sbx2; DIES=2; SUITE=multi
# 或四 die
export GPU_CHIP=sbx4; DIES=4; SUITE=multi
```

三行中一次只执行一行。`quick` 使用 auto 模式；`multi` 检查单 TG 的 auto 回退、显式 linear/chunk2 和 off。脚本内部逐例设置 `CK_TILE_RMSNORM_DIE_*`，外部设置不能把整个集合强制改成同一种模式。这里的 die 指同一个设备的 XCD，不是多个设备。

## 五个入口分别测试

```bash
python "$TEST/test_rmsnorm.py" --ops rms_norm \
    --suite "$SUITE" --expect-xcds "$DIES" --json "${GPU_CHIP}_rms_norm.json"
python "$TEST/test_rmsnorm.py" --ops rmsnorm2d_fwd \
    --suite "$SUITE" --expect-xcds "$DIES" --json "${GPU_CHIP}_rmsnorm2d_fwd.json"
python "$TEST/test_rmsnorm.py" --ops rmsnorm2d_fwd_with_add \
    --suite "$SUITE" --expect-xcds "$DIES" --json "${GPU_CHIP}_rmsnorm2d_fwd_with_add.json"
python "$TEST/test_rmsnorm_dynamicquant.py" --ops rmsnorm2d_fwd_with_dynamicquant \
    --suite "$SUITE" --expect-xcds "$DIES" --json "${GPU_CHIP}_dynamicquant.json"
python "$TEST/test_rmsnorm_dynamicquant.py" --ops rmsnorm2d_fwd_with_add_dynamicquant \
    --suite "$SUITE" --expect-xcds "$DIES" --json "${GPU_CHIP}_add_dynamicquant.json"
```

默认输入为 BF16、FP16；动态量化默认输出同时包含 INT8、FP8 E4M3FN。可用 `--dtypes bf16` 或动态量化脚本的 `--qdtypes fp8` 缩小矩阵。

| 入口 | quick | multi | full |
|---|---:|---:|---:|
| rms_norm | 4 | 6 | 8 |
| rmsnorm2d_fwd | 4 | 6 | 52 |
| rmsnorm2d_fwd_with_add | 4 | 6 | 58 |
| rmsnorm2d_fwd_with_dynamicquant | 8 | 12 | 72 |
| rmsnorm2d_fwd_with_add_dynamicquant | 8 | 12 | 76 |

以上是默认 dtype 下的用例数。将 `SUITE=full` 后执行同样五条命令，可在选定拓扑下覆盖宽度分桶、尾部、零/小值、残差原地写回等完整矩阵，共 266 例。Perf Model 使用 CPU 模拟，通常先运行 quick/multi 即可。`--json` 可省略；结束时应打印 `RESULT PASS N cases`，JSON 的 `complete` 应为 `true`，每个 case 为 `PASS`。

## 补充检查

单 die 显式 linear 应被拒绝：

```bash
GPU_CHIP=sb python "$TEST/test_rmsnorm.py" --suite single-reject --expect-xcds 1
GPU_CHIP=sb python "$TEST/test_rmsnorm_dynamicquant.py" --suite single-reject --expect-xcds 1
```

多 die 非法 mode/chunk/mask 等拒绝检查：

```bash
GPU_CHIP=sbx4 python "$TEST/test_rmsnorm.py" --suite invalid --expect-xcds 4
GPU_CHIP=sbx4 python "$TEST/test_rmsnorm_dynamicquant.py" --suite invalid --expect-xcds 4
```

非量化脚本的拒绝集合只调用 `rmsnorm2d_fwd`；动态量化拒绝集合默认调用两个入口，也支持 `--ops` 筛选。数值通过和拓扑断言不等于每次 dispatch 的全部 die 都参与执行。要验收路由，需启用 `GPU_DFLAGS="['StatLog','TT0']"` 并检查原始统计中各 XCD 的 `completedWGs` 及总 TG 数；统计解析不属于这两个数值脚本的输入依赖。动态量化 `--suite route --dtypes bf16` 的 12 例有足够任务覆盖 4 XCD；非量化 route 保留原双 XCD 用例，其 chunk2 小矩阵不足以要求每次 dispatch 覆盖全部 4 XCD。

所有选项可通过 `python "$TEST/test_rmsnorm.py" --help` 和 `python "$TEST/test_rmsnorm_dynamicquant.py" --help` 查看。
