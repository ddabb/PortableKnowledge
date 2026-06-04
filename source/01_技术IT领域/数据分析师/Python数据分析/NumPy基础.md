---
title: NumPy基础
description: NumPy是Python数值计算的核心库，提供多维数组对象和数学函数，是数据分析师必须掌握的基础工具
category: 01_技术IT领域/数据分析师/Python数据分析
tags:
  - 数据分析师
  - Python数据分析
  - NumPy
  - 数组操作
  - 数值计算
---

# NumPy基础

## 定义

NumPy（Numerical Python）是Python中用于科学计算的核心库，提供了：

1. **ndarray**：多维数组对象（高效存储和操作大规模数据）
2. **数学函数**：线性代数、统计、傅里叶变换等
3. **广播机制**：不同形状数组之间的运算规则

NumPy是Pandas、Scikit-learn、TensorFlow等库的基础，数据分析师必须掌握。

---

## 核心概念

### 1. ndarray（多维数组）

| 属性 | 说明 | 示例 |
|------|------|------|
| `ndim` | 维度（轴数） | `arr.ndim` |
| `shape` | 形状（各维度大小） | `arr.shape` → `(3, 4)` |
| `dtype` | 数据类型 | `arr.dtype` |
| `size` | 元素总数 | `arr.size` |
| `itemsize` | 每个元素的字节数 | `arr.itemsize` |

**示例**：

```python
import numpy as np

arr = np.array([[1, 2, 3], [4, 5, 6]])
print(arr.ndim)    # 2（二维数组）
print(arr.shape)   # (2, 3)（2行3列）
print(arr.dtype)    # int32 或 int64（取决于系统）
print(arr.size)     # 6（2×3=6个元素）
```

### 2. 数组创建函数

| 函数 | 说明 | 示例 |
|------|------|------|
| `np.array()` | 从列表或元组创建数组 | `np.array([1, 2, 3])` |
| `np.zeros()` | 创建全0数组 | `np.zeros((2, 3))` |
| `np.ones()` | 创建全1数组 | `np.ones((2, 3))` |
| `np.empty()` | 创建未初始化数组（值随机） | `np.empty((2, 3))` |
| `np.arange()` | 创建等差数组（类似range） | `np.arange(0, 10, 2)` → `[0, 2, 4, 6, 8]` |
| `np.linspace()` | 创建等间隔数组 | `np.linspace(0, 1, 5)` → `[0.  , 0.25, 0.5 , 0.75, 1.  ]` |
| `np.random.rand()` | 创建随机数组（均匀分布） | `np.random.rand(2, 3)` |
| `np.random.randn()` | 创建随机数组（标准正态分布） | `np.random.randn(2, 3)` |
| `np.eye()` | 创建单位矩阵 | `np.eye(3)` → 3×3单位矩阵 |

### 3. 数据类型（dtype）

| 数据类型 | 说明 |
|----------|------|
| `np.int32` | 32位整数 |
| `np.int64` | 64位整数（默认） |
| `np.float32` | 32位浮点数 |
| `np.float64` | 64位浮点数（默认） |
| `np.bool` | 布尔值 |
| `np.str` | 字符串 |

**指定数据类型**：

```python
arr = np.array([1, 2, 3], dtype=np.float64)
```

---

## 详细内容

### 一、数组操作

#### 1.1 数组索引和切片

**一维数组**（类似Python列表）：

```python
arr = np.array([10, 20, 30, 40, 50])

# 索引
print(arr[0])    # 10
print(arr[-1])   # 50

# 切片（返回原数组的视图，不是副本）
print(arr[1:4])  # [20, 30, 40]
print(arr[:3])    # [10, 20, 30]
print(arr[::2])   # [10, 30, 50]（步长为2）
```

**二维数组**：

```python
arr = np.array([[1, 2, 3], [4, 5, 6], [7, 8, 9]])

# 索引
print(arr[0, 0])   # 1（第1行第1列）
print(arr[1, 2])   # 6（第2行第3列）

# 切片
print(arr[0:2, 0:2])
# [[1, 2],
#  [4, 5]]

# 选择所有行的第0列
print(arr[:, 0])   # [1, 4, 7]
```

#### 1.2 数组变形（reshape）

```python
arr = np.arange(12)   # [0, 1, 2, ..., 11]

# 变形为3行4列
arr_reshaped = arr.reshape(3, 4)
print(arr_reshaped)
# [[ 0,  1,  2,  3],
#  [ 4,  5,  6,  7],
#  [ 8,  9, 10, 11]]

# 自动计算某一维度（-1）
arr_reshaped = arr.reshape(-1, 4)  # 自动计算行数（3行4列）
```

#### 1.3 数组合并（concatenate、stack）

```python
a = np.array([1, 2, 3])
b = np.array([4, 5, 6])

# 纵向合并（沿轴0）
np.concatenate([a, b])   # [1, 2, 3, 4, 5, 6]

# 横向合并（沿轴1，适用于二维数组）
a2 = np.array([[1, 2], [3, 4]])
b2 = np.array([[5, 6], [7, 8]])
np.concatenate([a2, b2], axis=1)
# [[1, 2, 5, 6],
#  [3, 4, 7, 8]]

# 垂直堆叠（vstack）
np.vstack([a2, b2])
# [[1, 2],
#  [3, 4],
#  [5, 6],
#  [7, 8]]

# 水平堆叠（hstack）
np.hstack([a2, b2])
# [[1, 2, 5, 6],
#  [3, 4, 7, 8]]
```

#### 1.4 数组拆分（split）

```python
arr = np.arange(8)   # [0, 1, 2, 3, 4, 5, 6, 7]

# 平均拆分为2部分
np.split(arr, 2)
# [array([0, 1, 2, 3]), array([4, 5, 6, 7])]

# 指定拆分位置
np.split(arr, [2, 5])
# [array([0, 1]), array([2, 3, 4]), array([5, 6, 7])]
```

---

### 二、数组运算

#### 2.1 向量化运算（逐元素运算）

```python
arr = np.array([1, 2, 3, 4])

# 标量运算（每个元素都参与运算）
print(arr + 10)   # [11, 12, 13, 14]
print(arr * 2)    # [2, 4, 6, 8]
print(arr ** 2)   # [1, 4, 9, 16]

# 数组间运算（逐元素）
arr2 = np.array([10, 20, 30, 40])
print(arr + arr2)   # [11, 22, 33, 44]
print(arr * arr2)   # [10, 40, 90, 160]
```

#### 2.2 矩阵运算

```python
a = np.array([[1, 2], [3, 4]])
b = np.array([[5, 6], [7, 8]])

# 矩阵乘法（点积）
np.dot(a, b)
# 或者
a @ b

# 转置
a.T
```

#### 2.3 广播机制（Broadcasting）

**规则**：两个数组进行运算时，如果形状不同，NumPy会自动扩展较小数组以匹配较大数组的形状（前提是维度兼容）。

**示例**：

```python
# 数组 + 标量（标量被广播为数组形状）
arr = np.array([[1, 2, 3], [4, 5, 6]])
print(arr + 10)
# [[11, 12, 13],
#  [14, 15, 16]]

# 二维数组 + 一维数组（一维数组被广播为二维）
arr = np.array([[1, 2, 3], [4, 5, 6]])
row = np.array([10, 20, 30])
print(arr + row)
# [[11, 22, 33],
#  [14, 25, 36]]
```

**广播兼容条件**：
- 两个数组的维度从后往前比较，要么相等，要么其中一个为1，要么其中一个不存在

---

### 三、统计函数

#### 3.1 基础统计

| 函数 | 说明 | 示例 |
|------|------|------|
| `np.sum()` | 求和 | `np.sum(arr)` |
| `np.mean()` | 平均值 | `np.mean(arr)` |
| `np.std()` | 标准差 | `np.std(arr)` |
| `np.var()` | 方差 | `np.var(arr)` |
| `np.min()` | 最小值 | `np.min(arr)` |
| `np.max()` | 最大值 | `np.max(arr)` |
| `np.argmin()` | 最小值索引 | `np.argmin(arr)` |
| `np.argmax()` | 最大值索引 | `np.argmax(arr)` |
| `np.median()` | 中位数 | `np.median(arr)` |
| `np.percentile()` | 百分位数 | `np.percentile(arr, 75)` |

**示例**：

```python
arr = np.array([1, 2, 3, 4, 5])

print(np.sum(arr))     # 15
print(np.mean(arr))    # 3.0
print(np.std(arr))     # 1.4142...
print(np.min(arr))     # 1
print(np.max(arr))     # 5
print(np.argmax(arr))  # 4（最大值在索引4）
```

#### 3.2 按轴统计

```python
arr = np.array([[1, 2, 3], [4, 5, 6]])

# 对整个数组统计
print(np.sum(arr))   # 21

# 沿轴0统计（每列）
print(np.sum(arr, axis=0))   # [5, 7, 9]

# 沿轴1统计（每行）
print(np.sum(arr, axis=1))   # [6, 15]
```

---

### 四、条件筛选

#### 4.1 布尔索引

```python
arr = np.array([10, 20, 30, 40, 50])

# 条件过滤
print(arr[arr > 25])   # [30, 40, 50]

# 多条件（& 和 |）
print(arr[(arr > 15) & (arr < 45)])   # [20, 30, 40]

# 条件替换
arr[arr > 30] = 0
print(arr)   # [10, 20, 30, 0, 0]
```

#### 4.2 where 函数

```python
arr = np.array([10, 20, 30, 40, 50])

# 条件选择（类似三元运算符）
result = np.where(arr > 25, '大', '小')
print(result)   # ['小', '小', '大', '大', '大']

# 条件替换
result = np.where(arr > 25, arr, 0)
print(result)   # [0, 0, 30, 40, 50]
```

#### 4.3 unique 和 in1d

```python
arr = np.array([1, 2, 2, 3, 3, 3])

# 去重
print(np.unique(arr))   # [1, 2, 3]

# 判断元素是否在另一数组中
arr2 = np.array([1, 3])
print(np.in1d(arr, arr2))   # [ True, False, False, True, True, True]
```

---

## 示例/应用场景

### 示例1：电商订单分析

**需求**：使用NumPy计算订单金额的平均值、标准差、最大值、最小值

**代码**：

```python
import numpy as np

# 模拟订单金额数据
order_amounts = np.array([100, 200, 150, 300, 250, 400, 50, 180])

# 统计描述
print('平均值:', np.mean(order_amounts))
print('标准差:', np.std(order_amounts))
print('最大值:', np.max(order_amounts))
print('最小值:', np.min(order_amounts))
print('中位数:', np.median(order_amounts))
print('75分位数:', np.percentile(order_amounts, 75))
```

### 示例2：员工薪资分析

**需求**：使用NumPy计算各部门工资的平均值、最大值、最小值

**代码**：

```python
import numpy as np

# 模拟数据（部门ID、工资）
data = np.array([
    [10, 5000],
    [10, 6000],
    [20, 7000],
    [20, 8000],
    [30, 5500]
])

# 按部门分组计算（使用循环，实际中可用Pandas更方便）
departments = np.unique(data[:, 0])
for dept in departments:
    dept_salaries = data[data[:, 0] == dept, 1]
    print(f'部门{dept} - 平均工资: {np.mean(dept_salaries)}, 最高工资: {np.max(dept_salaries)}, 最低工资: {np.min(dept_salaries)}')
```

### 示例3：用户留存分析

**需求**：使用NumPy计算用户登录间隔的平均值、标准差

**代码**：

```python
import numpy as np

# 模拟用户登录间隔（天）
login_intervals = np.array([1, 2, 3, 1, 4, 2, 5, 1, 2, 3])

# 统计描述
print('平均登录间隔:', np.mean(login_intervals))
print('标准差:', np.std(login_intervals))
print('中位数:', np.median(login_intervals))
```

---

## 数据分析师考点

### NumPy常见考点

1. **ndarray的属性**：`ndim`、`shape`、`dtype`、`size`
2. **数组创建函数**：`np.array()`、`np.zeros()`、`np.ones()`、`np.arange()`、`np.linspace()`
3. **数组索引和切片**：一维数组、二维数组的索引和切片
4. **数组运算**：向量化运算、矩阵乘法、广播机制
5. **统计函数**：`sum()`、`mean()`、`std()`、`min()`、`max()`、`argmin()`、`argmax()`
6. **条件筛选**：布尔索引、`np.where()`、`np.unique()`
7. **数组变形**：`reshape()`
8. **数组合并和拆分**：`concatenate()`、`vstack()`、`hstack()`、`split()`

### 实战考点

1. **向量化运算 vs 循环**：NumPy的向量化运算比Python循环快得多，应尽量使用向量化操作
2. **广播机制的规则**：理解广播兼容条件，避免形状不匹配的错误
3. **视图 vs 副本**：数组切片返回的是视图（修改会影响原数组），需要用`copy()`创建副本
4. **数据类型选择**：根据数据范围选择合适的数据类型（如`int32`比`int64`更节省内存）
5. **性能优化**：
   - 避免使用Python循环，使用向量化操作
   - 使用`np.where()`替代`if-else`循环
   - 使用`np.unique()`替代手动去重

---

## 最佳实践

### 1. 使用向量化操作，避免Python循环

**不推荐**（使用Python循环，性能差）：

```python
arr = np.arange(1000000)
result = []
for x in arr:
    result.append(x * 2)
```

**推荐**（使用向量化操作，性能好）：

```python
arr = np.arange(1000000)
result = arr * 2
```

### 2. 注意视图和副本的区别

**问题示例**：

```python
arr = np.array([1, 2, 3, 4])
slice_arr = arr[0:2]   # 切片返回视图
slice_arr[0] = 100
print(arr)   # [100, 2, 3, 4]（原数组被修改！）
```

**正确做法**（需要副本时使用`copy()`）：

```python
arr = np.array([1, 2, 3, 4])
slice_arr = arr[0:2].copy()   # 创建副本
slice_arr[0] = 100
print(arr)   # [1, 2, 3, 4]（原数组未被修改）
```

### 3. 明确指定数据类型

**不推荐**（让NumPy自动选择数据类型，可能浪费内存）：

```python
arr = np.array([1, 2, 3])   # 默认int64（8字节）
```

**推荐**（根据数据范围选择合适的数据类型）：

```python
arr = np.array([1, 2, 3], dtype=np.int32)   # int32（4字节），节省内存
```

### 4. 使用广播机制简化代码

**不推荐**（使用循环或手动扩展数组）：

```python
arr = np.array([[1, 2, 3], [4, 5, 6]])
row = np.array([10, 20, 30])
result = np.zeros((2, 3))
for i in range(2):
    result[i, :] = arr[i, :] + row
```

**推荐**（使用广播机制）：

```python
arr = np.array([[1, 2, 3], [4, 5, 6]])
row = np.array([10, 20, 30])
result = arr + row   # 自动广播
```

### 5. 使用np.where()替代条件循环

**不推荐**（使用循环和条件判断）：

```python
arr = np.array([10, 20, 30, 40, 50])
result = []
for x in arr:
    if x > 25:
        result.append('大')
    else:
        result.append('小')
```

**推荐**（使用`np.where()`）：

```python
arr = np.array([10, 20, 30, 40, 50])
result = np.where(arr > 25, '大', '小')
```

---

## 常见错误

### 1. 形状不匹配（广播兼容性问题）

**错误示例**：

```python
a = np.array([[1, 2, 3], [4, 5, 6]])   # 形状(2, 3)
b = np.array([10, 20])                   # 形状(2,)
a + b   # 错误！形状不兼容（3 != 2）
```

**正确做法**：

```python
a = np.array([[1, 2, 3], [4, 5, 6]])   # 形状(2, 3)
b = np.array([10, 20, 30])               # 形状(3,)
a + b   # 正确！b被广播为(2, 3)
```

### 2. 混淆视图和副本

**错误示例**：

```python
arr = np.array([1, 2, 3, 4])
slice_arr = arr[0:2]
slice_arr[0] = 100
print(arr)   # [100, 2, 3, 4]（原数组被意外修改）
```

**正确做法**：

```python
arr = np.array([1, 2, 3, 4])
slice_arr = arr[0:2].copy()   # 创建副本
slice_arr[0] = 100
print(arr)   # [1, 2, 3, 4]（原数组未被修改）
```

### 3. 使用Python循环而非向量化操作

**错误示例**（性能差）：

```python
arr = np.arange(1000000)
result = []
for x in arr:
    result.append(x * 2)
```

**正确做法**（性能好）：

```python
arr = np.arange(1000000)
result = arr * 2
```

### 4. 忘记指定axis参数

**错误示例**：

```python
arr = np.array([[1, 2, 3], [4, 5, 6]])
np.sum(arr)   # 对整个数组求和，返回单个值21
```

**正确做法**（明确指定axis）：

```python
arr = np.array([[1, 2, 3], [4, 5, 6]])
np.sum(arr, axis=0)   # 沿轴0求和（每列），返回[5, 7, 9]
np.sum(arr, axis=1)   # 沿轴1求和（每行），返回[6, 15]
```

### 5. 索引越界

**错误示例**：

```python
arr = np.array([1, 2, 3])
print(arr[5])   # 错误！索引越界
```

**正确做法**（检查形状）：

```python
arr = np.array([1, 2, 3])
if len(arr) > 5:
    print(arr[5])
else:
    print('索引越界')
```

---

## 总结

NumPy是Python数据分析的基石，核心要点包括：

1. **掌握ndarray**：多维数组对象，属性包括`ndim`、`shape`、`dtype`、`size`
2. **熟练数组创建**：`np.array()`、`np.zeros()`、`np.ones()`、`np.arange()`、`np.linspace()`
3. **掌握数组操作**：索引和切片、变形（`reshape()`）、合并（`concatenate()`、`vstack()`、`hstack()`）、拆分（`split()`）
4. **熟练数组运算**：向量化运算、矩阵乘法、广播机制
5. **掌握统计函数**：`sum()`、`mean()`、`std()`、`min()`、`max()`、`argmin()`、`argmax()`
6. **熟练条件筛选**：布尔索引、`np.where()`、`np.unique()`
7. **注意性能优化**：使用向量化操作，避免Python循环

NumPy是数据分析师的必备技能，需要在实践中不断积累经验。

---

## 扩展阅读

### 高级主题

1. **广播机制的深入理解**：广播兼容条件、广播的实际应用
2. **NumPy性能优化**：向量化操作、内存布局（C顺序 vs Fortran顺序）、视图 vs 副本
3. **线性代数**：矩阵分解（SVD、QR）、特征值计算、求解线性方程组
4. **随机数生成**：`np.random`模块的常用函数、随机数种子（`random.seed()`）

### 实战案例

1. **电商数据分析**：订单金额统计、用户消费行为分析
2. **金融数据分析**：股票价格收益率计算、风险指标（波动率）计算
3. **用户行为分析**：用户登录间隔分析、用户活跃度分析
4. **图像数据处理**：图像读取（PIL/OpenCV）、像素值操作（NumPy数组）

---

**注**：本文件内容适用于NumPy 1.0+版本，部分函数在新版本中可能有变化（如`np.random`模块在NumPy 1.17+中推荐使用`np.random.Generator`）。

---
