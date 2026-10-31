# torch\_npu.npu\_add\_quant\_matmul\_

## 产品支持情况

<!-- npu="950" id1 -->
- <term>Ascend 950PR&950DT系列产品</term>：支持
<!-- end id1 -->

## 功能说明

- API功能：

    在micro-batch训练场景，需要做micro-batch的梯度累积，会存在大量QuantBatchMatmul操作接InplaceAdd操作的场景。本算子（QuantBatchMatmulInplaceAdd）将上述操作融合起来，以提高网络性能。

- 计算公式：

    mx量化场景公式如下，更多关于量化技术的介绍参见《CANN 算子库》中的[量化介绍](https://gitcode.com/cann/ops-math/blob/9.2.0/docs/zh/context/quant_mode_introduction.md)。

    ![](../../figures/zh-cn_formulaimage_0000002521244910.png)

    其中gsk代表K轴的mx量化的block size即32，x1\_slice<sub>i</sub>代表x1<sub>i</sub>第m行长度为gsk的向量，x2\_slice<sub>i</sub>代表x2<sub>i</sub>第n列长度为gsk的向量，K轴均从j\*gsk起始切片，j的取值范围\[0, k\_loops\)，k\_loops=ceil\(K<sub>i</sub>/gsk\)，支持最后的切片长度不足gsk。

    T-T量化场景计算公式如下。

    ![](../../figures/zh-cn_formulaimage_0000002594063675.png)

## 函数原型

```python
torch_npu.npu_add_quant_matmul_(self, x1, x2, x2_scale, *, x1_scale=None, group_sizes=None, x1_dtype=None, x2_dtype=None, x1_scale_dtype=None, x2_scale_dtype=None) -> torch.Tensor
```

## 参数说明

- **self**（`Tensor`）：必选参数，待累加矩阵，数据类型支持`torch.float32`，tensor支持2维，shape为\(M, N\)，数据格式支持ND。
- **x1**（`Tensor`）：必选参数，表示矩阵乘法中的左矩阵，数据类型支持`torch.float8_e5m2`、`torch.float8_e4m3fn`、`torch_npu.hifloat8`、`torch_npu.float4_e2m1fn_x2`，tensor支持2维，具体shape约束参见“约束说明”，数据格式支持ND。
- **x2**（`Tensor`）：必选参数，表示矩阵乘法中的右矩阵，数据类型支持`torch.float8_e5m2`、`torch.float8_e4m3fn`、`torch_npu.hifloat8`、`torch_npu.float4_e2m1fn_x2`，tensor支持2维，具体shape约束参见“约束说明”，数据格式支持ND。
- **x2\_scale**（`Tensor`）：必选参数，表示矩阵乘法中的右矩阵的缩放因子，数据类型支持`torch.float8_e8m0fnu`、`torch.float32`，shape支持3维，其中`torch.float8_e8m0fnu`需配置可选参数`x2_scale_dtype`为对应类型，此时`x2_scale`本身的dtype不再生效，但仍需保证`x2_scale`本身的dtype为8bit位的数据类型，以保证shape正确。数据格式支持ND。
- \*：代表其之前的变量是位置相关的，必须按照顺序输入；之后的变量是可选参数，位置无关，需要使用键值对赋值，不赋值会使用默认值。
- **x1\_scale**（`Tensor`）：可选参数，表示矩阵乘法中的左矩阵的缩放因子，数据类型支持`torch.float8_e8m0fnu`、`torch.float32`，shape支持3维，其中`torch.float8_e8m0fnu`需配置可选参数`x1_scale_dtype`为对应类型，此时`x1_scale`本身的dtype不再生效，但仍需保证`x1_scale`本身的dtype为8bit位的数据类型，以保证shape正确。数据格式支持ND。
- **group\_sizes**（`List[int]`）：可选参数。默认值为None。
  - 非None时，仅支持三维列表，形如\[group\_m, group\_n, group\_k\]，分别表示在m、n、k维度上的量化分组情况。以group\_m为例，表示在m维度上group\_m个数对应一个量化参数。
  - 当\[group\_m, group\_n, group\_k\]中有1个或多个为0时，接口会根据`x1`、`x2`、`x1_scale`、`x2_scale`输入shape重新设置该值。计算原理：假设group\_m=0，表示m方向量化分组值由接口推断，推断公式为group\_m=m/scale\_m（保证m能被scale\_m整除），m与x1 shape中的m一致，scale\_m与x1\_scale shape中的m一致。
  - 目前\[group\_m, group\_n, group\_k\]mx量化支持的取值仅为\[1,1,32\]，T-T量化仅支持取值\[0,0,0\]。

- **x1\_dtype**（`int`）：可选参数，用于显式指定`x1`的逻辑数据类型。默认值为`None`，表示使用`x1`自身的dtype。支持`torch.float8_e4m3fn`、`torch.float8_e5m2`、`torch_npu.hifloat8`、`torch_npu.float4_e2m1fn_x2`。

- **x2\_dtype**（`int`）：可选参数，用于显式指定`x2`的逻辑数据类型。默认值为`None`，表示使用`x2`自身的dtype。支持`torch.float8_e4m3fn`、`torch.float8_e5m2`、`torch_npu.hifloat8`、`torch_npu.float4_e2m1fn_x2`。

- **x1\_scale\_dtype**（`int`）：可选参数，用于显式指定`x1_scale`的逻辑数据类型。None：默认值，表示输入真实数据类型与输入`x1_scale`的dtype相同。当前仅支持`torch.float8_e8m0fnu`。

- **x2\_scale\_dtype**（`int`）：可选参数，用于显式指定`x2_scale`的逻辑数据类型。None：默认值，表示输入真实数据类型与输入`x2_scale`的dtype相同。当前仅支持`torch.float8_e8m0fnu`。

> [!NOTE]
>
> - PyTorch 2.7及之前版本：使用8bit Tensor存储已打包的FP4数据，并通过`x1_dtype`、`x2_dtype`指定逻辑数据类型为`torch_npu.float4_e2m1fn_x2`。
> - PyTorch 2.8及以上版本：还可使用原生数据类型`torch.float4_e2m1fn_x2`构造输入Tensor，此时`x1_dtype`、`x2_dtype`可使用默认值`None`。

## 返回值说明

**self**（`Tensor`）：QuantBatchMatmul计算完成后与待累加矩阵相加得到的最后结果矩阵，支持数据类型、shape、数据格式均与输入self保持一致。

## 约束说明

- 该接口支持训练场景下使用。
- 该接口支持单算子模式和TorchAir图模式。
- 数据类型约束：

    | 场景 | x1 | x2 | x2_scale | x1_scale | self |
    | --- | --- | --- | --- | --- | --- |
    | MXFP8量化 | `torch.float8_e4m3fn`/`torch.float8_e5m2` | `torch.float8_e4m3fn`/`torch.float8_e5m2` | `torch.float8_e8m0fnu` | `torch.float8_e8m0fnu` | `torch.float32` |
    | MXFP4量化 | `torch.float4_e2m1fn_x2` | `torch.float4_e2m1fn_x2` | `torch.float8_e8m0fnu` | `torch.float8_e8m0fnu` | `torch.float32` |
    | T-T量化 | `torch_npu.hifloat8` | `torch_npu.hifloat8` | `torch.float32` | `torch.float32` | `torch.float32` |

- shape约束：

    | 场景 | x1 | x2 | x2_scale | x1_scale | self |
    | --- | --- | --- | --- | --- | --- |
    | MX量化 | (K,M) | (K,N) | (ceil(K/64),N,2) | (ceil(K/64),M, 2) | (M,N) |
    | T-T量化 | (K,M) | (K,N) | (1) | (1) | (M,N) |

- MXFP4量化约束：
  - MXFP4量化场景下，每个字节存放两个FP4编码，`x1`、`x2`打包后的原始存储shape会变为(K,M/2)、(K,N/2)。
  - 每个字节的低4 bit对应原始存储最后一轴的偶数索引元素，高4 bit对应奇数索引元素。M、N必须为偶数。
  - 当M、N、K均大于0时，必须同时满足M × K > 2、N × K > 2。
  - 在满足其他参数约束的前提下，M或N为0时返回空Tensor；K为0时，`self`保持原值。上述乘积约束不适用于M、N或K为0的场景。

## 调用示例

- 单算子模式调用
  - MXFP8量化单算子模式调用

    ```python
    import math
    import torch
    import torch_npu
    M = 576
    N = 7168
    K = 512
    y = torch.randint(-1, 1, (M, N), dtype=torch.float32).npu()
    x1 = torch.randint(-1, 1, (K, M), dtype=torch.int8).to(torch.float8_e4m3fn).npu().transpose(0,1)
    x2 = torch.randint(-1, 1, (K, N), dtype=torch.int8).to(torch.float8_e4m3fn).npu()
    x2_scale = torch.randint(-1, 1, (math.ceil(K/64), N, 2), dtype=torch.int8).npu()
    x1_scale = torch.randint(-1, 1, (math.ceil(K/64), M, 2), dtype=torch.int8).npu().transpose(0,1)
    y = torch_npu.npu_add_quant_matmul_(y, x1, x2, x2_scale,x1_scale = x1_scale, x1_scale_dtype=torch_npu.float8_e8m0fnu, x2_scale_dtype=torch_npu.float8_e8m0fnu, group_sizes = [1,1,32])
    ```

  - MXFP4量化单算子模式调用

    本示例使用原生数据类型`torch.float4_e2m1fn_x2`，要求PyTorch 2.8及以上版本，并安装配套且支持该数据类型的torch_npu版本。

    ```python
    import torch
    import torch_npu

    M = 576
    N = 7168
    K = 512
    R = (K + 63) // 64
    y = torch.ones((M, N), dtype=torch.float32).npu()
    x1 = torch.full((K, M // 2), 0x22, dtype=torch.uint8)
    x1 = x1.view(torch.float4_e2m1fn_x2).npu().transpose(0, 1)
    x2 = torch.full((K, N // 2), 0x22, dtype=torch.uint8)
    x2 = x2.view(torch.float4_e2m1fn_x2).npu()
    x1_scale = torch.full((R, M, 2), 127, dtype=torch.uint8).npu()
    x2_scale = torch.full((R, N, 2), 127, dtype=torch.uint8).npu()
    y = torch_npu.npu_add_quant_matmul_(
        y, x1, x2, x2_scale,
        x1_scale=x1_scale,
        group_sizes=[1, 1, 32],
        x1_dtype=torch.float4_e2m1fn_x2,
        x2_dtype=torch.float4_e2m1fn_x2,
        x1_scale_dtype=torch_npu.float8_e8m0fnu,
        x2_scale_dtype=torch_npu.float8_e8m0fnu,
    )
    torch.testing.assert_close(y, torch.full_like(y, K + 1), rtol=0, atol=0)
    print(y.cpu())
    ```

  - T-T量化单算子模式调用

    ```python
    import math
    import torch
    import torch_npu
    M = 16
    N = 16
    K = 16
    y = torch.randint(-1, 1, (M, N), dtype=torch.float32).npu()
    x1 = torch.randint(0, 1, (K, M), dtype=torch.uint8).npu().transpose(0,1)
    x2 = torch.randint(0, 1, (K, N), dtype=torch.uint8).npu()
    x2_scale = torch.randint(-1, 1, (1,), dtype=torch.float32).npu()
    x1_scale = torch.randint(-1, 1, (1,), dtype=torch.float32).npu()
    y = torch_npu.npu_add_quant_matmul_(y, x1, x2, x2_scale,x1_scale = x1_scale,x1_dtype =  torch_npu.hifloat8, x2_dtype = torch_npu.hifloat8, x1_scale_dtype=None, x2_scale_dtype=None, group_sizes = [0,0,0])
    ```

- 图模式调用
  - MXFP8量化图模式调用

    ```python
    import math
    import torch
    import torch.nn as nn
    import torch_npu
    import torchair as tng
    from torchair.configs.compiler_config import CompilerConfig
    import os
    config = CompilerConfig()
    npu_backend = tng.get_npu_backend(compiler_config=config)
    #os.environ["ENABLE_ACLNN"] = "true"
    M = 576
    N = 7168
    K = 512
    class Model(nn.Module):
        def __init__(self):
            super().__init__()
        def forward(self, y, x1, x2, x2_scale, x1_scale, x1_scale_dtype, x2_scale_dtype):
            return torch_npu.npu_add_quant_matmul_(y, x1.transpose(0,1), x2, x2_scale, x1_scale = x1_scale.transpose(0, 1), x1_scale_dtype=x1_scale_dtype, x2_scale_dtype=x2_scale_dtype)
    def main():
        y = torch.randint(-1, 1, (M, N), dtype=torch.float32).npu()
        x1 = torch.randint(-1, 1, (K, M), dtype=torch.int8).to(torch.float8_e4m3fn).npu()
        x2 = torch.randint(-1, 1, (K, N), dtype=torch.int8).to(torch.float8_e4m3fn).npu()
        x2_scale = torch.randint(-1, 1, (math.ceil(K/64),N, 2), dtype=torch.int8).npu()
        x1_scale = torch.randint(-1, 1, (math.ceil(K/64),M, 2), dtype=torch.int8).npu()
        model = Model().npu()
        model = torch.compile(model, backend=npu_backend)
        y = model(y, x1, x2, x2_scale, x1_scale, torch_npu.float8_e8m0fnu, torch_npu.float8_e8m0fnu)
        print(y.cpu())
     
    if __name__ == '__main__':
        main()
    ```

  - T-T量化图模式调用

    ```python
    import math
    import torch
    import torch.nn as nn
    import torch_npu
    import torchair as tng
    from torchair.configs.compiler_config import CompilerConfig
    import os
    config = CompilerConfig()
    npu_backend = tng.get_npu_backend(compiler_config=config)
    #os.environ["ENABLE_ACLNN"] = "true"
    M = 16
    N = 16
    K = 16
    class Model(nn.Module):
        def __init__(self):
            super().__init__()
        def forward(self, y, x1, x2, x2_scale, x1_scale, x1_scale_dtype, x2_scale_dtype):
            return torch_npu.npu_add_quant_matmul_(y, x1.transpose(0,1), x2, x2_scale, x1_dtype =  torch_npu.hifloat8, x2_dtype = torch_npu.hifloat8, x1_scale = x1_scale, x1_scale_dtype=None, x2_scale_dtype=None)
    def main():
        y = torch.randint(-1, 1, (M, N), dtype=torch.float32).npu()
        x1 = torch.randint(0, 1, (K, M), dtype=torch.uint8).npu()
        x2 = torch.randint(0, 1, (K, N), dtype=torch.uint8).npu()
        x2_scale = torch.randint(-1, 1, (1,), dtype=torch.float32).npu()
        x1_scale = torch.randint(-1, 1, (1,), dtype=torch.float32).npu()
        model = Model().npu()
        model = torch.compile(model, backend=npu_backend)
        y = model(y, x1, x2, x2_scale, x1_scale, None, None)
        print(y.cpu())
    
    if __name__ == '__main__':
        main()
    ```
