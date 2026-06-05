---
title: Scikit-learn机器学习入门
description: Scikit-learn是Python最常用的机器学习库，掌握其基础用法是数据分析师进行预测建模的关键技能
category: 考试/数据分析师/Python数据分析
tags:
  - 数据分析师
  - Python数据分析
  - Scikit-learn
  - 机器学习
  - 预测建模
  - 监督学习
  - 无监督学习
  - 数据分析
---

# Scikit-learn机器学习入门

## 定义

**Scikit-learn**是Python中最常用的**机器学习库**，提供了丰富的算法和工具。

对于数据分析师而言，掌握Scikit-learn的**基础用法**，是**进行预测建模、提升数据分析价值**的关键技能。

---

## 核心概念

### 1. 机器学习类型

| 类型 | 说明 | 示例 |
|------|------|------|
| **监督学习** | 使用带标签数据训练模型 | 分类、回归 |
| **无监督学习** | 使用无标签数据发现模式 | 聚类、降维 |
| **强化学习** | 通过与环境交互学习策略 | 游戏AI、机器人控制 |

### 2. Scikit-learn核心API

| API | 说明 | 示例 |
|------|------|------|
| **Estimator** | 所有模型的基类 | `fit()`, `predict()` |
| **Transformer** | 数据转换的基类 | `fit()`, `transform()` |
| **Pipeline** | 流水线，串联多个步骤 | `Pipeline()` |

---

## 详细内容

### 一、数据预处理

#### 1.1 缺失值处理

```python
import pandas as pd
import numpy as np
from sklearn.impute import SimpleImputer

# 创建数据
df = pd.DataFrame({
    'A': [1, 2, np.nan, 4, 5],
    'B': [np.nan, 2, 3, 4, np.nan],
    'C': [1, 2, 3, 4, 5]
})

# 使用均值填充缺失值
imputer = SimpleImputer(strategy='mean')
df_imputed = pd.DataFrame(imputer.fit_transform(df), columns=df.columns)

print(df_imputed)
```

#### 1.2 特征缩放

```python
import pandas as pd
import numpy as np
from sklearn.preprocessing import StandardScaler, MinMaxScaler

# 创建数据
df = pd.DataFrame({
    'A': [1, 2, 3, 4, 5],
    'B': [10, 20, 30, 40, 50]
})

# 标准化（均值为0，标准差为1）
scaler = StandardScaler()
df_standardized = pd.DataFrame(scaler.fit_transform(df), columns=df.columns)

# 归一化（缩放到0-1范围）
normalizer = MinMaxScaler()
df_normalized = pd.DataFrame(normalizer.fit_transform(df), columns=df.columns)

print("标准化:\n", df_standardized)
print("归一化:\n", df_normalized)
```

#### 1.3 分类变量编码

```python
import pandas as pd
from sklearn.preprocessing import LabelEncoder, OneHotEncoder

# 创建数据
df = pd.DataFrame({
    'color': ['red', 'blue', 'green', 'red', 'blue'],
    'size': ['S', 'M', 'L', 'XL', 'M']
})

# 标签编码（将分类变量转换为数值）
label_encoder = LabelEncoder()
df['color_encoded'] = label_encoder.fit_transform(df['color'])

# 独热编码（创建二进制列）
df_onehot = pd.get_dummies(df, columns=['color', 'size'])

print("标签编码:\n", df[['color', 'color_encoded']])
print("独热编码:\n", df_onehot)
```

---

### 二、监督学习：回归

#### 2.1 线性回归

```python
import pandas as pd
import numpy as np
from sklearn.model_selection import train_test_split
from sklearn.linear_model import LinearRegression
from sklearn.metrics import mean_squared_error, r2_score

# 创建数据
np.random.seed(42)
X = np.random.rand(100, 1) * 10
y = 2 * X + 1 + np.random.randn(100, 1) * 2

# 划分训练集和测试集
X_train, X_test, y_train, y_test = train_test_split(X, y, test_size=0.2, random_state=42)

# 创建并训练模型
model = LinearRegression()
model.fit(X_train, y_train)

# 预测
y_pred = model.predict(X_test)

# 评估
mse = mean_squared_error(y_test, y_pred)
r2 = r2_score(y_test, y_pred)

print(f"均方误差(MSE): {mse[0]:.4f}")
print(f"决定系数(R²): {r2:.4f}")
print(f"系数: {model.coef_[0][0]:.4f}")
print(f"截距: {model.intercept_[0]:.4f}")
```

#### 2.2 多项式回归

```python
import pandas as pd
import numpy as np
from sklearn.model_selection import train_test_split
from sklearn.preprocessing import PolynomialFeatures
from sklearn.linear_model import LinearRegression
from sklearn.metrics import mean_squared_error, r2_score

# 创建数据
np.random.seed(42)
X = np.random.rand(100, 1) * 10
y = 2 * X**2 + 3 * X + 1 + np.random.randn(100, 1) * 10

# 划分训练集和测试集
X_train, X_test, y_train, y_test = train_test_split(X, y, test_size=0.2, random_state=42)

# 创建多项式特征
poly = PolynomialFeatures(degree=2)
X_train_poly = poly.fit_transform(X_train)
X_test_poly = poly.transform(X_test)

# 创建并训练模型
model = LinearRegression()
model.fit(X_train_poly, y_train)

# 预测
y_pred = model.predict(X_test_poly)

# 评估
mse = mean_squared_error(y_test, y_pred)
r2 = r2_score(y_test, y_pred)

print(f"均方误差(MSE): {mse[0]:.4f}")
print(f"决定系数(R²): {r2:.4f}")
```

---

### 三、监督学习：分类

#### 3.1 逻辑回归

```python
import pandas as pd
import numpy as np
from sklearn.model_selection import train_test_split
from sklearn.linear_model import LogisticRegression
from sklearn.metrics import accuracy_score, confusion_matrix, classification_report

# 创建数据
np.random.seed(42)
X = np.random.rand(100, 2) * 10
y = (X[:, 0] + X[:, 1] > 10).astype(int)

# 划分训练集和测试集
X_train, X_test, y_train, y_test = train_test_split(X, y, test_size=0.2, random_state=42)

# 创建并训练模型
model = LogisticRegression()
model.fit(X_train, y_train)

# 预测
y_pred = model.predict(X_test)

# 评估
accuracy = accuracy_score(y_test, y_pred)
conf_matrix = confusion_matrix(y_test, y_pred)
class_report = classification_report(y_test, y_pred)

print(f"准确率: {accuracy:.4f}")
print(f"混淆矩阵:\n{conf_matrix}")
print(f"分类报告:\n{class_report}")
```

#### 3.2 决策树

```python
import pandas as pd
import numpy as np
from sklearn.model_selection import train_test_split
from sklearn.tree import DecisionTreeClassifier
from sklearn.metrics import accuracy_score, confusion_matrix, classification_report
import matplotlib.pyplot as plt
from sklearn.tree import plot_tree

# 创建数据
np.random.seed(42)
X = np.random.rand(100, 2) * 10
y = (X[:, 0] + X[:, 1] > 10).astype(int)

# 划分训练集和测试集
X_train, X_test, y_train, y_test = train_test_split(X, y, test_size=0.2, random_state=42)

# 创建并训练模型
model = DecisionTreeClassifier(max_depth=3, random_state=42)
model.fit(X_train, y_train)

# 预测
y_pred = model.predict(X_test)

# 评估
accuracy = accuracy_score(y_test, y_pred)
conf_matrix = confusion_matrix(y_test, y_pred)
class_report = classification_report(y_test, y_pred)

print(f"准确率: {accuracy:.4f}")
print(f"混淆矩阵:\n{conf_matrix}")
print(f"分类报告:\n{class_report}")

# 可视化决策树
plt.figure(figsize=(12, 8))
plot_tree(model, filled=True, feature_names=['X1', 'X2'], class_names=['0', '1'])
plt.title('决策树可视化')
plt.show()
```

---

### 四、无监督学习：聚类

#### 4.1 K-Means聚类

```python
import pandas as pd
import numpy as np
from sklearn.cluster import KMeans
import matplotlib.pyplot as plt

# 创建数据
np.random.seed(42)
X = np.random.rand(100, 2) * 10

# 创建并训练模型
kmeans = KMeans(n_clusters=3, random_state=42)
kmeans.fit(X)

# 获取聚类结果
labels = kmeans.labels_
centroids = kmeans.cluster_centers_

# 可视化
plt.scatter(X[:, 0], X[:, 1], c=labels, cmap='viridis')
plt.scatter(centroids[:, 0], centroids[:, 1], marker='X', s=200, c='red')
plt.title('K-Means聚类结果')
plt.xlabel('X1')
plt.ylabel('X2')
plt.show()
```

#### 4.2 层次聚类

```python
import pandas as pd
import numpy as np
from sklearn.cluster import AgglomerativeClustering
import matplotlib.pyplot as plt
from scipy.cluster.hierarchy import dendrogram, linkage

# 创建数据
np.random.seed(42)
X = np.random.rand(100, 2) * 10

# 层次聚类
model = AgglomerativeClustering(n_clusters=3)
labels = model.fit_predict(X)

# 可视化聚类结果
plt.scatter(X[:, 0], X[:, 1], c=labels, cmap='viridis')
plt.title('层次聚类结果')
plt.xlabel('X1')
plt.ylabel('X2')
plt.show()

# 绘制树状图
Z = linkage(X, 'ward')
plt.figure(figsize=(12, 6))
dendrogram(Z)
plt.title('层次聚类树状图')
plt.xlabel('样本')
plt.ylabel('距离')
plt.show()
```

---

### 五、模型评估与选择

#### 5.1 交叉验证

```python
import pandas as pd
import numpy as np
from sklearn.model_selection import cross_val_score, KFold
from sklearn.linear_model import LinearRegression

# 创建数据
np.random.seed(42)
X = np.random.rand(100, 1) * 10
y = 2 * X + 1 + np.random.randn(100, 1) * 2

# 创建模型
model = LinearRegression()

# 交叉验证
cv = KFold(n_splits=5, shuffle=True, random_state=42)
scores = cross_val_score(model, X, y, cv=cv, scoring='r2')

print(f"交叉验证R²分数: {scores}")
print(f"平均R²分数: {scores.mean():.4f}")
print(f"R²分数标准差: {scores.std():.4f}")
```

#### 5.2 超参数调优

```python
import pandas as pd
import numpy as np
from sklearn.model_selection import GridSearchCV
from sklearn.svm import SVC

# 创建数据
np.random.seed(42)
X = np.random.rand(100, 2) * 10
y = (X[:, 0] + X[:, 1] > 10).astype(int)

# 创建模型
model = SVC()

# 定义参数网格
param_grid = {
    'C': [0.1, 1, 10],
    'kernel': ['linear', 'rbf'],
    'gamma': ['scale', 'auto']
}

# 网格搜索
grid_search = GridSearchCV(model, param_grid, cv=5, scoring='accuracy')
grid_search.fit(X, y)

print(f"最佳参数: {grid_search.best_params_}")
print(f"最佳分数: {grid_search.best_score_:.4f}")
```

---

## 示例/应用场景

### 示例1：电商用户流失预测

**业务问题**：预测电商用户是否会流失。

**数据**：用户特征数据（使用时长、购买频率、投诉次数等），标签（是否流失）。

**分析**：

```python
import pandas as pd
import numpy as np
from sklearn.model_selection import train_test_split
from sklearn.linear_model import LogisticRegression
from sklearn.metrics import accuracy_score, confusion_matrix, classification_report

# 读取数据
df = pd.read_csv('user_churn.csv')

# 准备特征和目标
X = df[['usage_time', 'purchase_frequency', 'complaint_count']]
y = df['churn']

# 划分训练集和测试集
X_train, X_test, y_train, y_test = train_test_split(X, y, test_size=0.2, random_state=42)

# 创建并训练模型
model = LogisticRegression()
model.fit(X_train, y_train)

# 预测
y_pred = model.predict(X_test)

# 评估
accuracy = accuracy_score(y_test, y_pred)
conf_matrix = confusion_matrix(y_test, y_pred)
class_report = classification_report(y_test, y_pred)

print(f"准确率: {accuracy:.4f}")
print(f"混淆矩阵:\n{conf_matrix}")
print(f"分类报告:\n{class_report}")

# 预测概率
y_prob = model.predict_proba(X_test)[:, 1]
df_result = pd.DataFrame({
    'actual': y_test,
    'predicted': y_pred,
    'probability': y_prob
})
print(df_result.head())
```

**洞察与建议**：
- 如果模型准确率高，说明可以有效预测用户流失
- 可以针对高流失概率用户进行挽留
- 可以分析特征重要性，找出影响流失的关键因素

### 示例2：电商商品价格预测

**业务问题**：预测电商商品的价格。

**数据**：商品特征数据（类别、品牌、评分、销量等），标签（价格）。

**分析**：

```python
import pandas as pd
import numpy as np
from sklearn.model_selection import train_test_split
from sklearn.ensemble import RandomForestRegressor
from sklearn.metrics import mean_squared_error, r2_score

# 读取数据
df = pd.read_csv('product_prices.csv')

# 准备特征和目标
X = df[['category', 'brand', 'rating', 'sales']]
y = df['price']

# 对分类变量进行独热编码
X = pd.get_dummies(X, columns=['category', 'brand'])

# 划分训练集和测试集
X_train, X_test, y_train, y_test = train_test_split(X, y, test_size=0.2, random_state=42)

# 创建并训练模型
model = RandomForestRegressor(n_estimators=100, random_state=42)
model.fit(X_train, y_train)

# 预测
y_pred = model.predict(X_test)

# 评估
mse = mean_squared_error(y_test, y_pred)
r2 = r2_score(y_test, y_pred)

print(f"均方误差(MSE): {mse:.4f}")
print(f"决定系数(R²): {r2:.4f}")

# 特征重要性
feature_importance = pd.DataFrame({
    'feature': X.columns,
    'importance': model.feature_importances_
}).sort_values('importance', ascending=False)

print(feature_importance.head())
```

**洞察与建议**：
- 如果模型R²高，说明可以有效预测商品价格
- 可以分析特征重要性，找出影响价格的关键因素
- 可以根据价格预测结果进行动态定价

### 示例3：电商商品推荐

**业务问题**：根据用户购买历史，推荐相关商品。

**数据**：用户购买历史数据（用户ID、商品ID、购买次数）。

**分析**：

```python
import pandas as pd
import numpy as np
from sklearn.cluster import KMeans
from sklearn.preprocessing import StandardScaler

# 读取数据
df = pd.read_csv('user_purchase_history.csv')

# 创建用户-商品矩阵
user_product_matrix = df.pivot_table(index='user_id', columns='product_id', values='purchase_count', fill_value=0)

# 标准化
scaler = StandardScaler()
user_product_matrix_scaled = scaler.fit_transform(user_product_matrix)

# 聚类
kmeans = KMeans(n_clusters=5, random_state=42)
clusters = kmeans.fit_predict(user_product_matrix_scaled)

# 将聚类结果添加到用户-商品矩阵
user_product_matrix['cluster'] = clusters

# 分析每个聚类的商品偏好
cluster_product_preferences = {}
for cluster in range(5):
    cluster_users = user_product_matrix[user_product_matrix['cluster'] == cluster].index
    cluster_data = user_product_matrix.loc[cluster_users].drop('cluster', axis=1)
    cluster_product_preferences[cluster] = cluster_data.sum().sort_values(ascending=False).head(5)

print(cluster_product_preferences)
```

**洞察与建议**：
- 如果聚类效果好，说明可以发现具有相似商品偏好的用户群体
- 可以根据用户所属聚类，推荐该聚类热门商品
- 可以分析不同聚类的商品偏好，进行精准营销

---

## 数据分析师考点

### Scikit-learn机器学习入门常见考点

1. **机器学习类型**：监督学习、无监督学习、强化学习
2. **Scikit-learn核心API**：Estimator、Transformer、Pipeline
3. **数据预处理**：缺失值处理、特征缩放、分类变量编码
4. **监督学习：回归**：线性回归、多项式回归
5. **监督学习：分类**：逻辑回归、决策树
6. **无监督学习：聚类**：K-Means聚类、层次聚类
7. **模型评估与选择**：交叉验证、超参数调优
8. **Scikit-learn应用**：电商用户流失预测、电商商品价格预测、电商商品推荐

### 实战考点

1. **电商用户分析**：
   - 如何使用Scikit-learn预测用户流失
   - 如何评估用户流失预测模型
   - 如何根据预测结果制定用户挽留策略
2. **电商商品分析**：
   - 如何使用Scikit-learn预测商品价格
   - 如何评估商品价格预测模型
   - 如何根据预测结果制定动态定价策略
3. **电商推荐分析**：
   - 如何使用Scikit-learn进行商品推荐
   - 如何评估商品推荐效果
   - 如何根据推荐结果进行精准营销

---

## 最佳实践

### 1. 根据数据特征，选择合适的机器学习算法

**不推荐**（盲目使用线性回归）：

```
无论什么数据，都使用线性回归进行建模。
```

**推荐**（根据数据特征，选择合适的机器学习算法）：

```
- 连续目标变量 → 回归算法
- 分类目标变量 → 分类算法
- 无标签数据 → 聚类算法
```

### 2. 使用交叉验证评估模型

**不推荐**（只使用一次划分评估模型）：

```
X_train, X_test, y_train, y_test = train_test_split(X, y, test_size=0.2)
model.fit(X_train, y_train)
score = model.score(X_test, y_test)
```

**推荐**（使用交叉验证评估模型）：

```
cv = KFold(n_splits=5, shuffle=True, random_state=42)
scores = cross_val_score(model, X, y, cv=cv, scoring='r2')
```

### 3. 使用超参数调优提升模型性能

**不推荐**（使用默认超参数）：

```
model = SVC()
model.fit(X_train, y_train)
```

**推荐**（使用超参数调优提升模型性能）：

```
param_grid = {
    'C': [0.1, 1, 10],
    'kernel': ['linear', 'rbf']
}
grid_search = GridSearchCV(model, param_grid, cv=5, scoring='accuracy')
grid_search.fit(X, y)
```

### 4. 结合业务场景解释模型结果

**不推荐**（只报告模型性能指标）：

```
模型准确率90%。
```

**推荐**（结合业务场景解释模型结果）：

```
模型准确率90%，说明可以有效预测用户流失。可以针对高流失概率用户进行挽留。
```

---

## 常见错误

### 1. 盲目使用某种机器学习算法

**错误示例**：

```
无论什么数据，都使用线性回归进行建模。
```

**正确做法**：

```
根据数据特征，选择合适的机器学习算法。
```

### 2. 不使用交叉验证评估模型

**错误示例**：

```
X_train, X_test, y_train, y_test = train_test_split(X, y, test_size=0.2)
model.fit(X_train, y_train)
score = model.score(X_test, y_test)
```

**正确做法**：

```
使用交叉验证评估模型。
```

### 3. 不使用超参数调优提升模型性能

**错误示例**：

```
model = SVC()
model.fit(X_train, y_train)
```

**正确做法**：

```
使用超参数调优提升模型性能。
```

### 4. 不结合业务场景解释模型结果

**错误示例**：

```
模型准确率90%。
```

**正确做法**：

```
结合业务场景解释模型结果。
```

### 5. 数据泄露（Data Leakage）

**错误示例**：

```
# 在划分训练集和测试集之前进行特征缩放
scaler = StandardScaler()
X_scaled = scaler.fit_transform(X)
X_train, X_test, y_train, y_test = train_test_split(X_scaled, y, test_size=0.2)
```

**正确做法**：

```
# 在划分训练集和测试集之后进行特征缩放
X_train, X_test, y_train, y_test = train_test_split(X, y, test_size=0.2)
scaler = StandardScaler()
X_train_scaled = scaler.fit_transform(X_train)
X_test_scaled = scaler.transform(X_test)
```

---

## 总结

Scikit-learn机器学习入门是数据分析师进行预测建模的关键技能，关键要点包括：

1. **掌握机器学习类型**：监督学习、无监督学习、强化学习
2. **掌握Scikit-learn核心API**：Estimator、Transformer、Pipeline
3. **掌握数据预处理**：缺失值处理、特征缩放、分类变量编码
4. **掌握监督学习**：回归（线性回归、多项式回归）、分类（逻辑回归、决策树）
5. **掌握无监督学习**：聚类（K-Means聚类、层次聚类）
6. **掌握模型评估与选择**：交叉验证、超参数调优
7. **熟练应用Scikit-learn**：电商用户流失预测、电商商品价格预测、电商商品推荐
8. **注意最佳实践**：根据数据特征选择合适的机器学习算法、使用交叉验证评估模型、使用超参数调优提升模型性能、结合业务场景解释模型结果
9. **避免常见错误**：盲目使用某种机器学习算法、不使用交叉验证评估模型、不使用超参数调优提升模型性能、不结合业务场景解释模型结果、数据泄露

Scikit-learn机器学习入门是数据分析师的必备技能，需要在实践中不断积累经验。

---

## 扩展阅读

### 高级主题

1. **集成学习**：随机森林、梯度提升树、XGBoost
2. **深度学习**：神经网络、卷积神经网络、循环神经网络
3. **自然语言处理**：文本分类、情感分析、主题模型
4. **推荐系统**：协同过滤、基于内容的推荐、混合推荐

### 实战案例

1. **电商用户分析**：用户流失预测、用户画像分析、用户生命周期价值预测
2. **电商商品分析**：商品价格预测、商品销量预测、商品推荐
3. **电商订单分析**：订单转化率预测、订单金额预测、订单欺诈检测
4. **金融数据分析**：信用评分、风险预测、投资策略

---

**注**：本文件内容适用于所有需要使用Scikit-learn进行机器学习建模的场景，是数据分析师的必备技能。
