import torch
import torch.nn as nn
import numpy as np
import matplotlib.pyplot as plt

# y = a * x + b

# 生成模拟数据
X_numpy = np.random.rand(100, 1) * 10  # 100个0到10之间的随机数
y_numpy = 2 * X_numpy + 1 + np.random.randn(100, 1)  # 真实的斜率是2，截距是1，加上一些噪声

# 将NumPy数组转换为PyTorch张量
X = torch.from_numpy(X_numpy).float()
y = torch.from_numpy(y_numpy).float()


# 定义线性回归模型
# nn.Linear(in_features, out_features)
# 在这里，输入和输出的特征数都为1
model = nn.Linear(1, 1) # -》 一个神经元
# 全链接层，本质是多个神经元（参数1，输入的纬度； 参数2， 输出的纬度）

# 定义损失函数 (均方误差)
loss_fn = nn.MSELoss()

# 定义优化器 (随机梯度下降)
# model.parameters() 会自动找到模型中需要优化的参数（即a和b）
optimizer = torch.optim.SGD(model.parameters(), lr=0.01) # lr 是学习率

# 训练模型
num_epochs = 1000  # 训练迭代次数
for epoch in range(num_epochs):
    # 前向传播：计算预测值
    y_pred = model(X)

    # 计算损失
    loss = loss_fn(y_pred, y)

    # 反向传播和优化：
    optimizer.zero_grad()  # 清空梯度
    loss.backward()  # 计算梯度
    optimizer.step()  # 更新参数

    # 每100个epoch打印一次损失
    if (epoch + 1) % 100 == 0:
        print(f'Epoch [{epoch + 1}/{num_epochs}], Loss: {loss.item():.4f}')

# 打印最终学到的参数
# model.weight 是斜率a， model.bias 是截距b
print("\n训练完成！")
a_learned = model.weight.item()
b_learned = model.bias.item()
print(f"拟合的斜率 a: {a_learned:.4f}")
print(f"拟合的截距 b: {b_learned:.4f}")


# 将模型切换到评估模式，这在训练结束后是好习惯
model.eval() # bn dropout 修改为评估模式

# 禁用梯度计算，因为我们不再训练
with torch.no_grad():
    y_predicted = model(X).numpy() # 使用训练好的模型进行预测

# 绘图
plt.figure(figsize=(10, 6))
plt.scatter(X_numpy, y_numpy, label='Raw data', color='blue', alpha=0.6)
plt.plot(X_numpy, y_predicted, label=f'Model: y = {a_learned:.2f}x + {b_learned:.2f}', color='red', linewidth=2)
plt.xlabel('X')
plt.ylabel('y')
plt.legend()
plt.grid(True)
plt.show()
