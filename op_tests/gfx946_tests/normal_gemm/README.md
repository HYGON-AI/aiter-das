# 普通 GEMM 的 gfx946 测试

`test_normal_gemm.py` 仅使用 Python 标准库、AITER、Torch 和系统 HSA 库；输入及 FP32 参考均在 CPU 生成，运行无需临时脚本、输入文件或调优文件覆盖。默认每例只调用一次 DUT，适合 CPU Perf Model。

```bash
# 在已安装本 checkout 的容器中执行
python op_tests/gfx946_tests/normal_gemm/test_normal_gemm.py --op wvSpltK --suite full
python op_tests/gfx946_tests/normal_gemm/test_normal_gemm.py --op mm --suite full
python op_tests/gfx946_tests/normal_gemm/test_normal_gemm.py --op wvSpltK --dtype bfloat16 --suite full
python op_tests/gfx946_tests/normal_gemm/test_normal_gemm.py --op mm --dtype bfloat16 --suite boundaries
python op_tests/gfx946_tests/normal_gemm/test_normal_gemm.py --suite boundaries
python op_tests/gfx946_tests/normal_gemm/test_normal_gemm.py --suite config
python op_tests/gfx946_tests/normal_gemm/test_normal_gemm.py --op mm --case m2_n64_k512 --bias --out-dtype float32
python op_tests/gfx946_tests/normal_gemm/test_normal_gemm.py --op mm --case m2_n64_k512 --batched

# sb 为单 XCD，sbx2 为双 XCD；变量需在 HIP 初始化前设置。
GPU_ARCHS=gfx946 GPU_CHIP=sbx2 PMD_PATH=/opt/rocm/pmd \
LD_LIBRARY_PATH=/opt/rocm/lib:/opt/rocm/pmd \
python op_tests/gfx946_tests/normal_gemm/test_normal_gemm.py \
  --op wvSpltK --suite full --require-arch gfx946 --expect-xcds 2

# 双 XCD 强制 linear/chunk2；初始化后脚本删除 GPU_CHIP，launcher 读 numXcc。
GPU_ARCHS=gfx946 GPU_CHIP=sbx2 PMD_PATH=/opt/rocm/pmd \
LD_LIBRARY_PATH=/opt/rocm/lib:/opt/rocm/pmd \
python op_tests/gfx946_tests/normal_gemm/test_normal_gemm.py \
  --case m2_n64_k512 --die-mode linear --chunk 2 --expect-xcds 2

# 只在真机使用重复计时。JSON 为输出证据，可省略。
python op_tests/gfx946_tests/normal_gemm/test_normal_gemm.py \
  --op mm --suite full --warmup 5 --repeat 20 --json result.json
```

M/N/K 统一表示 x[M,K]、weight[N,K]、output[M,N]。HCU `wvSpltK` 接受连续 FP16/BF16、M=1..4、N>0、K 为 8 的正倍数；输入、输出位于同一 HIP 设备且 dtype 一致。FP16 且 K%512==0 保留原 HGEMV 内核；BF16 和其他 K 使用带边界保护的 typed-load 内核。测试含逐元素误差、输出形状/dtype、输入不变、输出前后保护区与拒绝参数。`boundaries` 包括 N=1、M=3、K=8/504/520/8704。

`hipb_mm` 使用 `weight.t()`，必须单独验证 BLAS 库支持。`--bpreshuffle` 仅供能力拒绝探测，未构造 shuffle 后的权重，不能把它当作该布局的数值验收。某些 BLAS 错误直接退出进程，应隔离运行并保存退出码。HCU `mm` 的 FP16/BF16 小 M 自有路径无需初始化 BLAS；其他 shape/dtype/scale 的库路径仍需独立验收。`--case m8_n9_k512 --dtype bfloat16 --op mm` 是越过小 M 选择器的库能力探测。`otype=float32` 是低精度 GEMV 结果转换，不能视为 FP32 输出精度的 GEMM。

运行时环境变量：`AITER_NORMAL_GEMM_DIE_MODE=auto|off|linear`；多 die 时 `AITER_NORMAL_GEMM_DIE_CHUNK` 为正整数，`AITER_NORMAL_GEMM_DIE_MASK` 仅允许 0（全部 XCD）；`AITER_NORMAL_GEMM_LOG_LAUNCH=1` 输出选择与 grid。`auto` 在 gfx946 多 XCD 且至少两个 TG 时选择 linear。Graph 和真实 gfx946 硬件未由本测试验收。
