# Mmad

## 产品支持情况

| 产品 | 不传bias | 传入bias |
| :--- | :------: | :-----: |
| Ascend 950PR/Ascend 950DT | √ | √ |

## 功能说明

头文件为：`#include "tensor_api/tensor.h"`

 `Mmad`接口用于完成L0A Buffer上左矩阵A和L0B Buffer上右矩阵B的矩阵乘加，结果写入L0C Buffer上结果矩阵C。默认模式为普通矩阵计算。数学表达式为：

```text
C = A * B
```

带bias输入时，bias作为结果矩阵C初始值参与计算，等价于：

```text
C = A * B + Bias
```

Mmad的矩阵乘加关系可参考下图：

![Mmad矩阵乘加数学表达式](../figures/mmad_formula.png)

`Mmad`使用显式传入的`MmadAtom`配置矩阵计算功能。左矩阵A、右矩阵B、结果矩阵C的图示说明如下：

![Mmad矩阵计算示意图](../figures/mmad_matrix_layout.png)

## 函数原型

- 执行不传bias的矩阵计算。

    ```cpp
    template <typename AtomType, typename DstTensor, typename FmTensor, typename FilterTensor>
    __aicore__ inline void Mmad(
        const MmadAtom<AtomType>& atomMmad, const DstTensor& dst, const FmTensor& fm, const FilterTensor& filter);
    ```

- 执行传入bias的矩阵计算。

    ```cpp
    template <typename AtomType, typename DstTensor, typename FmTensor, typename FilterTensor, typename BiasTensor,
        Std::enable_if_t<IsAttrTensorV<BiasTensor>, int> Enable>
    __aicore__ inline void Mmad(
        const MmadAtom<AtomType>& atomMmad, const DstTensor& dst, const FmTensor& fm, const FilterTensor& filter,
        const BiasTensor& bias);
    ```

- 构造默认矩阵计算原子对象。

    ```cpp
    template <typename MmadOperationType>
    __aicore__ inline constexpr auto MakeMmad(const MmadOperationType& mmadOperation);
    ```

- 构造指定Trait的矩阵计算原子对象。

    ```cpp
    template <typename MmadOperationType, typename MmadTraitType>
    __aicore__ inline constexpr auto MakeMmad(
        const MmadOperationType& mmadOperation, const MmadTraitType& mmadTrait);
    ```

## 参数说明

**表 1** `Mmad`接口参数说明

| 参数名 | 输入/输出 | 描述 |
| :--- | :---: | :--- |
| `atomMmad` | 输入 | 矩阵计算原子对象。通过`MakeMmad(MmadOperation{})`或`MakeMmad(MmadOperation{}, MmadTraitDefault{})`可以构造默认原子对象。 |
| `dst` | 输出 | 结果矩阵C，存储位置为`Location::L0C`，数据格式为NZ。 |
| `fm` | 输入 | 左矩阵A，存储位置为`Location::L0A`，数据格式为ZN。 |
| `filter` | 输入 | 右矩阵B，存储位置为`Location::L0B`，数据格式为NZ。 |
| `bias` | 输入 | bias张量，存储位置为`Location::BIAS`，数据格式为ND。 |

**表 2** `MakeMmad`接口参数说明

| 参数名 | 输入/输出 | 描述 |
| :--- | :---: | :--- |
| `mmadOperation` | 输入 | 矩阵计算操作对象，通过`MmadOperation{}`构造。 |
| `mmadTrait` | 输入 | 矩阵计算Trait对象，用于指定矩阵计算静态特性。默认使用`MmadTraitDefault{}`。 |

**表 3** `MmadParams`参数说明

| 参数名 | 类型 | 默认值 | 描述 |
| :--- | :--- | :--- | :--- |
| `m` | `uint16_t` | `0` | 左矩阵A的高度，结果矩阵C的高度。 |
| `n` | `uint16_t` | `0` | 右矩阵B的宽度，结果矩阵C的宽度。 |
| `k` | `uint16_t` | `0` | 左矩阵A的宽度，右矩阵B的高度。 |
| `unitFlag` | `uint8_t` | `0` | 控制`Mmad`和后续矩阵数据搬出的细粒度并行。`0`表示不使能；`2`表示使能且执行后不复位单元标记位；`3`表示使能且执行后复位单元标记位。 |
| `cmatrixInitVal` | `bool` | `false` | 不传bias时，控制是否初始化结果矩阵C。`true`表示初始化后为零计算，`false`表示基于结果矩阵C原始值累加计算。 |

**表 4** `MmadTrait`参数说明

| 参数名 | 类型 | 默认值 | 描述 |
| :--- | :--- | :--- | :--- |
| `fmOffset` | `int32_t` | `0` | 左矩阵offset，当前Tensor API实现中作为兼容参数保留。 |
| `kDirectionAlign` | `bool` | `false` | K方向对齐控制，当前Tensor API实现中作为兼容参数保留。 |
| `cmatrixSource` | `bool` | `false` | 不传bias时，配合`cmatrixInitVal`指示结果矩阵C初始值来源。带bias调用时该配置无效。 |
| `disableGemv` | `bool` | `true` | M=1 场景下是否关闭GEMV模式。`false`表示开启GEMV，`true`表示关闭GEMV。 |
| `mmadType` | `MmadType` | `MmadType::NORMAL` | 矩阵计算类型。默认使用`MmadType::NORMAL`，`MmadType::MX`。表示MX场景Mmad计算。 |

## 数据类型

支持如下左矩阵A、右矩阵B、结果矩阵C的数据类型组合如下：

| 左矩阵A | 右矩阵B | 结果矩阵C |
| :--- | :--- | :--- |
| `int8_t` | `int8_t` | `int32_t` |
| `half` | `half` | `float` |
| `float` | `float` | `float` |
| `bfloat16_t` | `bfloat16_t` | `float` |
| `fp8_e4m3fn_t` | `fp8_e4m3fn_t` | `float` |
| `fp8_e4m3fn_t` | `fp8_e5m2_t` | `float` |
| `fp8_e5m2_t` | `fp8_e4m3fn_t` | `float` |
| `fp8_e5m2_t` | `fp8_e5m2_t` | `float` |
| `hifloat8_t` | `hifloat8_t` | `float` |

传入bias的场景中，`int8_t * int8_t -> int32_t`的组合要求bias数据类型为`int32_t`，其余组合要求bias数据类型为`float`。

## 返回值说明

`Mmad`无返回值。`MakeMmad`返回`MmadAtom`对象。

## API映射关系

与built-in接口映射关系：

普通Mmad接口是在built-in接口`asc_mmad`的基础上进行抽象封装实现的，其对应的底层built-in接口原型为：

```cpp
__aicore__ inline void asc_mmad(__cc__ float* c_matrix, __ca__ bfloat16_t* a_matrix,
    __cb__ bfloat16_t* b_matrix, uint16_t left_height, uint16_t n_dim, uint16_t right_width,
    uint8_t unit_flag, bool disable_gemv, bool c_matrix_source, bool c_matrix_init_val);
__aicore__ inline void asc_mmad(__cc__ float* c_matrix, __ca__ float8_e4m3_t* a_matrix,
    __cb__ float8_e4m3_t* b_matrix, uint16_t left_height, uint16_t n_dim, uint16_t right_width,
    uint8_t unit_flag, bool disable_gemv, bool c_matrix_source, bool c_matrix_init_val);
__aicore__ inline void asc_mmad(__cc__ float* c_matrix, __ca__ float8_e4m3_t* a_matrix,
    __cb__ float8_e5m2_t* b_matrix, uint16_t left_height, uint16_t n_dim, uint16_t right_width,
    uint8_t unit_flag, bool disable_gemv, bool c_matrix_source, bool c_matrix_init_val);
__aicore__ inline void asc_mmad(__cc__ float* c_matrix, __ca__ float8_e5m2_t* a_matrix,
    __cb__ float8_e4m3_t* b_matrix, uint16_t left_height, uint16_t n_dim, uint16_t right_width,
    uint8_t unit_flag, bool disable_gemv, bool c_matrix_source, bool c_matrix_init_val);
__aicore__ inline void asc_mmad(__cc__ float* c_matrix, __ca__ float8_e5m2_t* a_matrix,
    __cb__ float8_e5m2_t* b_matrix, uint16_t left_height, uint16_t n_dim, uint16_t right_width,
    uint8_t unit_flag, bool disable_gemv, bool c_matrix_source, bool c_matrix_init_val);
__aicore__ inline void asc_mmad(__cc__ float* c_matrix, __ca__ half* a_matrix,
    __cb__ half* b_matrix, uint16_t left_height, uint16_t n_dim, uint16_t right_width,
    uint8_t unit_flag, bool disable_gemv, bool c_matrix_source, bool c_matrix_init_val);
__aicore__ inline void asc_mmad(__cc__ float* c_matrix, __ca__ float* a_matrix,
    __cb__ float* b_matrix, uint16_t left_height, uint16_t n_dim, uint16_t right_width,
    uint8_t unit_flag, bool disable_gemv, bool c_matrix_source, bool c_matrix_init_val);
__aicore__ inline void asc_mmad(__cc__ int32_t* c_matrix, __ca__ int8_t* a_matrix,
    __cb__ int8_t* b_matrix, uint16_t left_height, uint16_t n_dim, uint16_t right_width,
    uint8_t unit_flag, bool disable_gemv, bool c_matrix_source, bool c_matrix_init_val);
```

MX Mmad接口是在built-in接口`asc_mmad_mx`的基础上进行抽象封装实现的，其对应的底层built-in接口原型为：

```cpp
__aicore__ inline void asc_mmad_mx(__cc__ float* c_matrix, __ca__ fp4x2_e1m2_t* a_matrix,
    __cb__ fp4x2_e1m2_t* b_matrix, uint16_t left_height, uint16_t n_dim, uint16_t right_width,
    uint8_t unit_flag, bool disable_gemv, bool c_matrix_source, bool c_matrix_init_val);
__aicore__ inline void asc_mmad_mx(__cc__ float* c_matrix, __ca__ fp4x2_e1m2_t* a_matrix,
    __cb__ fp4x2_e2m1_t* b_matrix, uint16_t left_height, uint16_t n_dim, uint16_t right_width,
    uint8_t unit_flag, bool disable_gemv, bool c_matrix_source, bool c_matrix_init_val);
__aicore__ inline void asc_mmad_mx(__cc__ float* c_matrix, __ca__ fp4x2_e2m1_t* a_matrix,
    __cb__ fp4x2_e1m2_t* b_matrix, uint16_t left_height, uint16_t n_dim, uint16_t right_width,
    uint8_t unit_flag, bool disable_gemv, bool c_matrix_source, bool c_matrix_init_val);
__aicore__ inline void asc_mmad_mx(__cc__ float* c_matrix, __ca__ fp4x2_e2m1_t* a_matrix,
    __cb__ fp4x2_e2m1_t* b_matrix, uint16_t left_height, uint16_t n_dim, uint16_t right_width,
    uint8_t unit_flag, bool disable_gemv, bool c_matrix_source, bool c_matrix_init_val);
__aicore__ inline void asc_mmad_mx(__cc__ float* c_matrix, __ca__ fp8_e4m3fn_t* a_matrix,
    __cb__ fp8_e4m3fn_t* b_matrix, uint16_t left_height, uint16_t n_dim, uint16_t right_width,
    uint8_t unit_flag, bool disable_gemv, bool c_matrix_source, bool c_matrix_init_val);
__aicore__ inline void asc_mmad_mx(__cc__ float* c_matrix, __ca__ fp8_e4m3fn_t* a_matrix,
    __cb__ fp8_e5m2_t* b_matrix, uint16_t left_height, uint16_t n_dim, uint16_t right_width,
    uint8_t unit_flag, bool disable_gemv, bool c_matrix_source, bool c_matrix_init_val);
__aicore__ inline void asc_mmad_mx(__cc__ float* c_matrix, __ca__ fp8_e5m2_t* a_matrix,
    __cb__ fp8_e4m3fn_t* b_matrix, uint16_t left_height, uint16_t n_dim, uint16_t right_width,
    uint8_t unit_flag, bool disable_gemv, bool c_matrix_source, bool c_matrix_init_val);
__aicore__ inline void asc_mmad_mx(__cc__ float* c_matrix, __ca__ fp8_e5m2_t* a_matrix,
    __cb__ fp8_e5m2_t* b_matrix, uint16_t left_height, uint16_t n_dim, uint16_t right_width,
    uint8_t unit_flag, bool disable_gemv, bool c_matrix_source, bool c_matrix_init_val);
```

## 约束说明

- `dst`必须位于L0C Buffer，`fm`必须位于L0A Buffer，`filter`必须位于L0B Buffer。
- 结果矩阵C起始地址需要满足64Byte地址对齐要求；
- 左矩阵A和右矩阵B起始地址需要满足512Byte地址对齐要求。
- `m`、`n`、`k`需要与参与`Mmad`计算的矩阵尺寸一致。
- 使用`unitFlag`时，需要结果矩阵C搬出接口的`FixpipeParams::unitFlag`与`Mmad`计算的`MmadParams::unitFlag`参数配合设置。
- 当M、K、N不是 16 的倍数时，硬件仍以 16 * 16 分形块组织数据，尾块中的无效数据会占用分形块空间但不参与有效计算。有效数据与无效数据排布方式如下图所示：

![非16倍数场景中有效数据与无效数据示意图](../figures/mmad_tail_valid_data.png)

## 关键特性说明

### 结果矩阵C初始化

不传bias时，`cmatrixInitVal`控制是否初始化结果矩阵C。需要计算新结果时，通常第一次K方向累加设置为`true`；后续K分块累加设置为`false`。

带bias调用时，自动根据bias张量位置确定结果矩阵C初始值来源。

连续两次`Mmad`沿K方向累加时，通常需要关注中间结果的写读依赖。同步优化的阈值关系可参考下图：

![同步优化阈值公式](../figures/mmad_pipebarrier_threshold.png)

### UnitFlag

`unitFlag`用于控制`Mmad`与后续`Fixpipe`的细粒度并行。启用时，`MmadParams::unitFlag`和结果搬出的`FixpipeParams::unitFlag`需要配合设置，常见取值为`2`和`3`。

### GEMV模式

当M=1时，可通过`MmadTrait::disableGemv`控制是否开启GEMV模式。默认值为`true`，表示关闭GEMV。

### MX Mmad模式

MX Mmad模式不是单独的函数入口，而是通过`MmadTrait::mmadType`选择。使用MX Mmad时，需要将`mmadType`设置为`MmadType::MX`，并通过`MakeMmad(MmadOperation{}, MmadTraitMX{})`构造矩阵计算原子对象。

```cpp
struct MmadTraitMX {
    using TraitType = MmadTrait;
    static constexpr const TraitType value = MmadTrait(0, false, false, true, MmadType::MX);
};
```

MX Mmad支持如下左矩阵A、右矩阵B、结果矩阵C的数据类型组合：

| 左矩阵A | 右矩阵B | 结果矩阵C |
| :--- | :--- | :--- |
| `fp4x2_e2m1_t` | `fp4x2_e2m1_t` | `float` |
| `fp4x2_e2m1_t` | `fp4x2_e1m2_t` | `float` |
| `fp4x2_e1m2_t` | `fp4x2_e2m1_t` | `float` |
| `fp4x2_e1m2_t` | `fp4x2_e1m2_t` | `float` |
| `fp8_e4m3fn_t` | `fp8_e4m3fn_t` | `float` |
| `fp8_e4m3fn_t` | `fp8_e5m2_t` | `float` |
| `fp8_e5m2_t` | `fp8_e4m3fn_t` | `float` |
| `fp8_e5m2_t` | `fp8_e5m2_t` | `float` |

MX Mmad通常需要在调用`Mmad`前完成ScaleA和ScaleB数据搬运。ScaleA搬运可参考[L1到L0ScaleA数据搬运](../data_movement/l1_to_l0scalea.md)，ScaleB搬运可参考[L1到L0ScaleB数据搬运](../data_movement/l1_to_l0scaleb.md)。Scale数据不作为`Mmad`函数参数传入，而是由对应数据搬运接口提前准备到硬件要求的位置。

## 调用示例

- Mmad调用示例

```cpp
#include "tensor_api/tensor.h"

__aicore__ inline void NormalMmadExample()
{
    using namespace AscendC::Te;

    constexpr uint16_t m = 16;
    constexpr uint16_t n = 16;
    constexpr uint16_t k = 16;

    __ca__ half l0aBuf[m * k];
    __cb__ half l0bBuf[k * n];
    __cc__ float l0cBuf[m * n];

    auto l0A = MakeTensor(MakeMemPtr(l0aBuf), MakeFrameLayout<NZLayoutPtn, half>(m, k));
    auto l0B = MakeTensor( MakeMemPtr(l0bBuf), MakeFrameLayout<ZNLayoutPtn, half>(k, n));
    auto l0C = MakeTensor(MakeMemPtr(l0cBuf), MakeFrameLayout<NZLayoutPtn, 16>(m, n));

    MmadParams params(m, n, k, 0, true);
    auto atom = MakeMmad(MmadOperation{}, MmadTraitDefault{}).with(params);
    Mmad(atom, l0C, l0A, l0B);
}
```

- MX场景Mmad调用示例

```cpp
#include "tensor_api/tensor.h"

struct MmadTraitMX {
    using TraitType = AscendC::Te::MmadTrait;
    static constexpr const TraitType value = AscendC::Te::MmadTrait(0, false, false, true, AscendC::Te::MmadType::MX);
};

__aicore__ inline void MxMmadExample()
{
    using namespace AscendC::Te;

    constexpr uint16_t m = 16;
    constexpr uint16_t n = 16;
    constexpr uint16_t k = 16;

    __ca__ fp8_e4m3fn_t l0aBuf[m * k];
    __cb__ fp8_e5m2_t l0bBuf[k * n];
    __cc__ float l0cBuf[m * n];

    auto l0A = MakeTensor(MakeMemPtr(l0aBuf), MakeFrameLayout<NZLayoutPtn, fp8_e4m3fn_t>(m, k));
    auto l0B = MakeTensor(MakeMemPtr(l0bBuf), MakeFrameLayout<ZNLayoutPtn, fp8_e5m2_t>(k, n));
    auto l0C = MakeTensor(MakeMemPtr(l0cBuf), MakeFrameLayout<NZLayoutPtn, 16>(m, n));

    MmadParams params(m, n, k, 0, true);
    auto atom = MakeMmad(MmadOperation{}, MmadTraitMX{}).with(params);
    Mmad(atom, l0C, l0A, l0B);
}
```
